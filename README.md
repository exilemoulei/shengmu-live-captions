# 声幕 · 实时字幕翻译
•专门针对直播场景优化
•对直播观众友好
•功能简单干脆

## 快速开始

只需要桌面版 Chrome 138 或更新版本，不用装任何程序、不用敲命令。Edge 等其他 Chromium 浏览器没有本机语音识别，需改用阿里云百炼或本地 WhisperLiveKit。

1. 下载本仓库并解压，打开 `chrome://extensions`，开启「开发者模式」，点「加载已解压的扩展程序」，选 `extension` 目录。
2. 打开要看的视频或直播页，点扩展图标（或按 `Ctrl+Shift+Y`）打开面板，点「开始实时翻译」。`Ctrl+Shift+U` 打开字幕与历史窗口。

默认的识别与翻译都用 Chrome 自带的本机模型，不需要 Key。第一次点「开始」时 Chrome 会下载本机语音模型与翻译模型（各约 20 秒），之后离线可用。内置翻译偏直译，面板会提示填一个 DeepSeek Key，填了以后译文自然得多。

## 识别引擎

| 引擎 | 位置 | 说明 |
|---|---|---|
| Chrome 本机识别（默认） | 本机 | 不用设置；没有标点，长句会一次性给出 |
| 阿里云百炼 fun-asr-realtime | 云端 | 面板填一个百炼 Key，按秒计费，可选中国内地或国际地域；同一个 Key 也可用于通义千问翻译 |
| 本地 WhisperLiveKit | 本机 | 需要本地服务与显卡，见下文「本地模型」 |

## 本地模型（可选）

需要 Node.js 24 LTS（24.22.2 或更新，旧版本有已公开的安全漏洞）和 pnpm；本地模型推理在 Windows 上用 NVIDIA GPU，在 Apple Silicon Mac 上用 Metal（见下文「macOS」）。

```sh
# 1. 起本地服务：ASR(8010) + 本地翻译(8013)；纯 API 用法加 --asr-only 省显存
pnpm services:start

# 2. 起开发浏览器并加载扩展
pnpm dev-browser --url https://www.youtube.com/
```

面板里把识别引擎切到「本地 WhisperLiveKit」即可使用。也可以用 `pnpm services:serve` 在后台起控制服务（`127.0.0.1:8014`），之后在面板里一键启停本地模型；`pnpm services:serve-stop` 关掉它。`pnpm services:status` 看各端口状态，`pnpm services:stop` 停掉本地模型。

Windows 上可以双击仓库根目录的 `install-windows.cmd`（需已安装 Node.js）：它把一个本机消息助手登记给 Chrome 和 Edge，之后面板里的「启动控制服务」按钮就能直接拉起控制服务，不必再开终端。`install-windows.cmd --uninstall` 撤销登记。

模型档位可切换：`--translation-model 9b-q4km|2b-iq4xs`、`--asr-model large-v3-turbo|medium`。全部选项见 `pnpm services help`。

本地服务的目录约定（都在 `.research/` 下，不入库）：WhisperLiveKit 源码 `WhisperLiveKit/`、虚拟环境 `wlk-venv/`（Windows 为 `Scripts\*.exe`，macOS/Linux 为 `bin/`）、llama.cpp `llama.cpp-*/`、翻译模型 `models/`。进程 PID 记在 `.runtime/`，日志在 `logs/`。模型下载走 Node 的 fetch，设置了 `HTTPS_PROXY` 会自动走代理（`SHENGMU_DOWNLOAD_NO_PROXY=1` 关闭）；`HF_ENDPOINT` 可换 Hugging Face 镜像。

### macOS

ASR 默认走 whisper.cpp（Metal 加速）。WhisperLiveKit 没有 whisper.cpp 后端，所以由它的 `openai-api` 后端把音频转给本机的 `whisper-server`（`127.0.0.1:8011`，`--inference-path /v1/audio/transcriptions`），扩展仍然只连 8010，用法不变。这条路是实验性的：whisper-server 只按句段返回词级时间戳，识别节奏可能比 Windows 上的 faster-whisper 粗。

- `whisper-server` 需要自己编译 whisper.cpp（Homebrew 的 `whisper-cpp` 不带它），放在 `.research/whisper.cpp/build/bin/` 或 PATH 里。
- ggml 模型（`ggml-large-v3-turbo.bin` / `ggml-medium.bin`）首次启动时自动下载到 `.research/models/whisper.cpp/`。
- WhisperLiveKit 仍需本项目所用的那份分支（`--openai-translation-*` 等参数只在它里面有）。
- 想换回 MLX：`SHENGMU_ASR_BACKEND=mlx-whisper pnpm services:start`。

## 字幕怎么显示

浮层默认停靠在画面下方，可拖动、可隐藏，字号与背景透明度在面板里调。

| 模式 | 内容 |
|---|---|
| 双语 | 当前句英文 + 当前句中文 |
| 双行 | 上一句中文 + 当前句英文 + 当前句中文 |
| 中文 | 只有中文译文 |
| 英文 | 只有识别出的英文 |

面板与浮层工具栏里每点一次「双语」按钮就按这个顺序切换。

几句实测行为，看懂了就不会误以为出故障：

- 新的英文片段出现后，译文槽会继续显示**上一句中文**（不做变灰处理），右下角出现一个小冰蓝点表示「这句还在翻」。等待不足 0.7 秒不会显示小点。
- 译文随句子生长逐步更新（阶段译文），不会先闪一句新译又跳回上一句；只有一句真正译完才写入历史与导出。
- 被 ASR 切碎的半句会与后一句合并成一条字幕再翻译，所以偶尔会看到一行字幕比平常长、出现得稍晚。
- 滚轮上滑可回看最近字幕，面板会实时跟随最新字幕（新的从底部进、最老的从顶部出），回到最底部自动恢复实时。
- 英文槽固定单行，过长时在左侧渐隐；还没定稿的尾巴（识别中的半句）比已定稿部分淡一档；字幕框高度变化有 160 ms 缓动，不会每句硬跳。
- 浮层按直播画面来做：中文纯白粗黑体、英文冰川蓝，两行都带闭合黑描边，底板半透明拉到底（5%）也能在亮色画面上看清；底板是中性黑曜石色，不再偏绿。

## 翻译引擎

| 引擎 | 位置 | 说明 |
|---|---|---|
| Chrome 内置翻译（默认） | 本机 | 不用 Key；偏直译、不看上下文，术语库通过占位词保留官译 |
| DeepSeek API | 云端 | 面板填 Key，响应快；模型固定 `deepseek-flash`，文本会发往 DeepSeek |
| DeepL API | 云端 | 面板填 Key（免费版以 `:fx` 结尾时自动走 api-free 端点）；按字符计费，面板显示已计费字符数 |
| OpenAI API | 云端 | 同上，模型可改 |
| 阿里云百炼（通义千问） | 云端 | 与百炼语音识别共用一个 Key，地域跟随识别引擎的设置 |
| 自定义 OpenAI 兼容 | 自定 | 可指向本地 `llama-server`（`http://127.0.0.1:8013/v1`）或任何兼容端点 |
| WhisperLiveKit 内置 | 本机 | 识别引擎为本地 WhisperLiveKit 时，面板把翻译引擎切到「本地服务」，由 WLK 调用 8013 翻译，扩展不再改写译文 |

纯 API 用法推荐 `pnpm services:start --asr-only`，显存全给 ASR。API Key 只存在本机 `chrome.storage`，不会下发给网页。

## 术语库

内置 313 条《流放之路 1/2》国服解包官译（逐条对照 `poedb.tw/cn`、`poe2db.tw/cn`），另可导入自定义词条（TXT/CSV），支持同音误听别名。术语按所选引擎生效：识别侧是 Whisper 热词、Chrome 本机识别的短语偏置或百炼的上下文提示，翻译侧是 WhisperLiveKit 内部词表、API 翻译提示词、Chrome 内置翻译的占位词（先把术语换成无意义的拉丁占位词再翻译，译完换回官译），或 DeepL 的术语库。

DeepL 改不了提示词，术语只能通过术语库生效：在面板术语库区域点「同步到 DeepL」，扩展会把当前词条（含小写变体，约 680 条）建成账号里的 glossary，之后每批翻译自动带上。免费版 Key 只允许存在 1 个 glossary，每次同步会先删除旧的再创建；词条改了要重新同步。

不需要游戏术语时可在面板里关掉，或只保留「领域提示」一句话。

## 常见问题

- **没有字幕**：先看面板的状态与音频电平。Chrome 本机识别首次要下载模型；用本地 WhisperLiveKit 时确认 8010 在线（面板「检查本地服务」），本地模型首次加载要几十秒。
- **字幕慢一拍**：本地 9B 单次翻译 1~3 秒，长句合并后更明显；换 DeepSeek API 会快很多。链路总延迟通常 1~3 秒。Chrome 本机识别没有标点，会等一段话说完才定稿，长句更明显。
- **浮层不见了**：可能被隐藏或页面全屏；面板里可重新注入，历史窗口始终可见。
- **切换页面后没声音**：会话绑定在开始采集时那个标签页，页面内跳转偶尔会让浏览器停掉音频流；先停止再开始一次即可。这是已知问题，诊断埋点（音频峰值、track 静音事件）已就位。
- **抓到广告/其他声音**：标签页整体音频都会被采集，无法按内容过滤。
- **DRM 内容**：Netflix 等受保护内容可能拿不到音频。

## 开发

```sh
pnpm install                 # 只装开发工具（ESLint、TypeScript），扩展本身不依赖 node_modules
pnpm run verify              # 语法检查 + ESLint + 类型检查（lib/）+ 单元测试，提交前必过
pnpm run smoke               # 无头 Chrome 加载扩展，检查后台、offscreen、面板、字幕页、浮层注入与本机消息助手的扩展 ID 查找
pnpm services:start          # 本地 ASR + 翻译（scripts/services.mjs）
```

改代码后在 `chrome://extensions` 点「重新加载」。界面文案在 `extension/_locales/`（`zh_CN` 为默认，另有 `en`、`zh_TW`），新增文案三份都要加，`tests/i18n-catalog.test.js` 会检查。包管理器为 pnpm（版本由 `package.json` 的 `packageManager` 锁定，`corepack enable` 后自动使用）。`verify` 中各项也可单独运行：`pnpm run check`（全部脚本 `node --check`）、`pnpm run lint`、`pnpm run typecheck`、`pnpm test`。CI（`.github/workflows/ci.yml`）在每次 push 与 PR 上于 Ubuntu、Windows、macOS（x64 与 arm64）跑 `verify`，在 Ubuntu、Windows、macOS 跑 `smoke`。本地服务的启停逻辑在 `scripts/local-service/`（`service-manager.mjs`，控制服务 `server.mjs` 与命令行共用），测试用桩进程代替真实模型，任何系统上都能跑。

分层约定：`extension/` 按入口分目录（`background/`、`offscreen/`、`content/`、`popup/`、`subtitle/`），入口之间只通过 `chrome.runtime` / `chrome.storage.local` 通信；`lib/` 为纯函数模块，禁止引入 `chrome.*` 与 DOM；`storage/history-db.js` 封装 IndexedDB。设计与验收记录在 `paseo/`。

## 许可证

MIT，见 [LICENSE](LICENSE)。
