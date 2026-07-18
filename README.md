<div align="center">

# 🛡️ DeepSentry v2.0.1 Ultimate — 深海哨兵

<h3>"让 AI 成为你的红蓝对抗伙伴与安全运维专家。"</h3>

<p>
  <i>Your AI-powered Security Agent for Local, Remote & Fleet Auditing.</i>
</p>

<p align="center">
  <img src="https://img.shields.io/badge/Team-Hx0-red?style=flat-square" alt="Team">
  <img src="https://img.shields.io/badge/Version-v2.0.1%20Ultimate-2f81f7?style=flat-square" alt="Version">
  <img src="https://img.shields.io/badge/Platform-Windows%20%7C%20Linux%20%7C%20macOS-gray?style=flat-square&logo=linux&logoColor=white" alt="Platform">
  <img src="https://img.shields.io/badge/Go-1.25.12+-00ADD8?style=flat-square&logo=go&logoColor=white" alt="Go">
  <img src="https://img.shields.io/badge/AI-Multi--Provider-blueviolet?style=flat-square" alt="AI">
</p>

[一眼看懂](#一眼看懂) • [下载](#下载哪个文件) • [案例用法](#典型场景与案例用法) • [CTF/AWD](#ctf--awd--awd-plus-能力) • [快速开始](#5-分钟快速开始) • [配置说明](#配置文件说明) • [安全建议](#安全建议)

</div>

DeepSentry 是一个 AI 安全应急与智能运维 Agent。你只需要用自然语言描述任务，它会自动规划步骤、调用 Shell 或内置 Go 原生工具、连接本地或远程目标、持续观察结果，并生成可审计的 Markdown 报告。

<img width="1536" height="1024" alt="2.0.1" src="https://github.com/user-attachments/assets/29b31ff0-44dd-4e35-a570-bb8fae7e18a7" />

> 仅允许在你拥有或已获得明确授权的系统中使用。请不要将 DeepSentry 用于未授权扫描、入侵、破坏、绕过访问控制或任何违法用途。

> 数据边界：任务内容、必要的上下文和工具结果会发送给你配置的模型服务。处理敏感环境前，请确认服务商的数据政策；如数据不能离开本地环境，请使用受控的本地模型，并在公开报告或截图前完成脱敏。

---

## 目录

- [一眼看懂](#一眼看懂)
- [最新版本亮点](#最新版本亮点)
- [典型场景与案例用法](#典型场景与案例用法)
- [CTF / AWD / AWD-Plus 能力](#ctf--awd--awd-plus-能力)
- [下载哪个文件](#下载哪个文件)
- [5 分钟快速开始](#5-分钟快速开始)
- [配置文件说明](#配置文件说明)
- [常用运行模式](#常用运行模式)
- [WebShell / 蚁剑 / 非交互环境用法](#webshell--蚁剑--非交互环境用法)
- [TUI 全屏界面用法](#tui-全屏界面用法)
- [内置工具清单](#内置工具清单)
- [多目标 Fleet 用法](#多目标-fleet-用法)
- [长上下文与多 Agent 协作](#长上下文与多-agent-协作)
- [报告、会话与记忆](#报告会话与记忆)
- [外部 MCP 与 Skills 扩展](#外部-mcp-与-skills-扩展)
- [定时任务与多通道通知](#定时任务与多通道通知)
- [从源码构建](#从源码构建)
- [常见问题](#常见问题)
- [安全建议](#安全建议)
- [项目结构](#项目结构)

阅读建议：第一次使用直接看 [下载哪个文件](#下载哪个文件) 和 [5 分钟快速开始](#5-分钟快速开始)；日常操作看 [TUI 全屏界面用法](#tui-全屏界面用法)；完整参数和进阶流程看 [操作手册](docs/操作手册.md)。

---

## 一眼看懂

| 你想做什么 | DeepSentry 怎么做 |
| --- | --- |
| 排查服务器状态 | 自动查看系统版本、CPU/内存/磁盘、进程、监听端口、网络连接 |
| 分析安全事件 | 自动读取日志、筛选异常登录、排查可疑进程和网络连接 |
| 做 Web / 数据库探测 | 使用 `http_probe`、`web_snapshot`、`mysql_probe`、`redis_probe` 等内置工具 |
| 在 WebShell 里运行 | `--webshell` 立即返回，后台执行，进度和报告可用 `cat` 查看 |
| 多台服务器巡检 | 配置 `targets[]`，使用 Fleet 或多目标子 Agent 批量执行 |
| CTF 辅助分析 | 自动识别文件、扫 flag、解压归档、读 pcap/sqlite/日志、辅助还原证据链 |
| AWD / AWD-Plus 值守 | 批量检查服务可用性、巡检 Web 目录、同步文件、发现异常进程和敏感配置 |
| 复杂任务分工 | 子 Agent 可按任务难度动态估步，也支持多个子 Agent 并行协作 |
| 长会话持续排查 | 分层压缩旧历史，固定保留目标、用户修正、核心线索与最近步骤 |
| 查看关键证据 | `/memory clues` 查看当前会话自动汇聚的 IP、URL、CVE、哈希和路径 |
| 需要审计留痕 | 每次任务生成 `reports/report_<时间>.md` Markdown 报告 |
| 极简目标机没有工具 | 大量能力用 Go 原生实现，很多场景不依赖目标机安装 `ps/netstat/nmap/file/strings/tcpdump` |

核心特性：

- 中文 UI、中文提示、中文报告。
- 默认进入交互式 TUI 全屏界面。
- 支持本地、SSH、Telnet、FTP、Fleet 多目标。
- 内置 65 个安全应急、运维与取证工具。
- 支持 WebShell 非 TTY 场景，后台运行并实时写进度日志。
- 支持 checkpoint 恢复、多轮追问、记忆、定时任务。

---

## 最新版本亮点

当前构建版本：

```bash
./build/deepsentry --version
```

示例输出：

```text
DeepSentry v2.0.1 Ultimate (build YYYY-MM-DD)
```

`build` 日期取决于所下载或自行编译的二进制。

v2.0.1 Ultimate 重点能力：

| 模块 | 说明 |
| --- | --- |
| TUI 默认模式 | 默认进入全屏 Agent 面板，支持多轮输入、任务中断、恢复会话、斜杠命令 |
| WebShell 模式 | `--webshell` 提交后台执行，立即打印报告和进度路径，使用 `cat` 查看 |
| 65 个内置工具 | 覆盖网络、进程、日志、文件、文档、Web、数据库、pcap、Fleet、代理转发、定时任务、配置管理 |
| SSH 输出流修复 | 长任务不再等全部结束才输出，后台进度日志会逐步写入 |
| 文件传输修复 | `file_upload` / `file_download` 支持带空格路径和引号路径 |
| 扫描类工具修复 | 远程配置扫描、secret 扫描、service unit 审计更稳更快 |
| Fleet 体验优化 | `fleet_exec` / `fleet_file` 按真实命令或文件动作动态判险，只读操作不再反复确认 |
| 裸 SSH 防卡死 | 控制端裸 `ssh/scp/sftp` 连接已配置目标时会被拦截并提示改用 Fleet，避免卡在交互式密码输入 |
| 模型响应自动恢复 | 模型偶尔返回普通 Markdown 而非 JSON 时，会自动识别询问、Shell 代码块或自然语言结论，不再直接显示解析失败 |
| Unicode 排版修复 | Markdown 表格、询问面板和日志统一按 Emoji 字素簇计算宽度，组合表情不再与文字重叠或挤坏右边框 |
| sudo 安全交互 | 本机 TUI 通过系统 `sudo -v` 验证且不接触密码，执行统一使用 `sudo -n`；远程缺少免密授权时立即返回，不再卡住界面 |
| 上下文窗口可见 | 标题栏显示 `ctx=1.05M[配置]`、`ctx≈131.1K[安全默认]` 等有效窗口及来源，避免把会话 token 用量误认为模型上限 |
| 初始化上下文选项 | `--init` 可选择自动、64K、128K、256K、512K、1M、2M 或自定义实际上下文窗口 |
| Coding 套餐预设 | 初始化向导内置百度千帆 Coding Plan、火山方舟 Coding Plan、Xiaomi MiMo Token Plan / MiMo Claw |
| Shell 双层安全复核 | 规则判高后再由 AI 复核；只有程序与 AI 都判断为高风险才请求人工确认，复核不可用时失败关闭 |
| 折叠内容全局切换 | 按 `e` 一次展开全部思考、工具长输出和子 Agent 结果，再按一次全部折叠；实时思考保持可见 |

---

## 典型场景与案例用法

DeepSentry 的核心用法不是记命令，而是把目标、范围和期望结果说清楚。Agent 会自己选择 Shell、内置工具、Fleet 多目标、文件传输、子 Agent 或报告生成流程。

### 1. 日常服务器巡检

适合上线前检查、日常运维、云主机交付验收。

```bash
./deepsentry -c config.yaml --task "检查这台服务器的系统版本、CPU、内存、磁盘、负载、监听端口、最近登录用户和异常进程，最后按风险等级输出巡检报告。"
```

它通常会组合使用：

- `target_health_summary` 查看系统整体状态。
- `mem_info`、`disk_usage`、`process_list` 获取基础资源。
- `port_listen`、`net_connections`、`route_table` 判断网络暴露面。
- `login_audit` 检查登录记录。
- Markdown 报告沉淀结论和证据。

### 2. SSH 登录日志审计

适合排查爆破、撞库、异常来源 IP、可疑登录时间线。

```bash
./deepsentry -c config.yaml --task "审计今天的 SSH 登录日志，统计失败登录 Top IP、成功登录账号、异常时间段和可能的攻击来源，并给出封禁建议。"
```

可进一步要求：

```text
把 auth.log、secure、syslog 中的登录行为合并成时间线，区分失败登录、成功登录、sudo、su、ssh key 登录和异常来源 IP。
```

### 3. WebShell 和后门排查

适合 Web 目录被篡改、可疑 PHP/JSP/ASP 文件排查、应急响应初筛。

```bash
./deepsentry -c config.yaml --task "检查 /var/www/html 是否存在疑似 WebShell、混淆脚本、最近新增文件和可疑外连，输出文件路径、命中原因和处置建议。"
```

它可以结合：

- `secret_scan` 查找敏感配置、密钥和可疑片段。
- `file_ident`、`file_strings` 判断文件类型和可疑字符串。
- `read_log` 分析访问日志和错误日志。
- `process_list`、`net_connections` 查找 Web 进程异常连接。
- `file_download` 下载样本到控制端进一步分析。

### 4. Web / 数据库暴露面检查

适合新资产上线检查、内网服务盘点、应急期间快速摸清暴露面。

```bash
./deepsentry -c config.yaml --task "检查目标机开放端口，识别 Web、Redis、MySQL、PostgreSQL、Oracle 服务，判断是否存在弱配置或未授权访问风险。"
```

可用能力包括：

- `nmap_scan` / `cidr_scan` 做端口和网段探测。
- `service_fingerprint` 识别服务指纹。
- `http_probe` / `http_fetch` / `web_snapshot` 检查 Web 响应和页面。
- `redis_probe` / `mysql_probe` / `postgres_probe` / `oracle_probe` 做数据库连通性与基础风险探测。

### 5. 多台服务器批量巡检

适合多台靶机、业务集群、攻防演练环境、AWD 批量值守。

```text
对 prod 标签下的所有 SSH 目标执行系统巡检，检查 CPU、内存、磁盘、监听端口、最近登录、Web 目录变化和可疑进程，最后按主机汇总风险。
```

如果只需要执行低风险只读命令：

```text
对 selector=prod,ssh 的目标执行 uptime、df -h、ss -lntp，并汇总异常项。
```

Fleet 会根据 `selector` 匹配目标，并通过 `fleet_exec` / `fleet_file` 执行命令或文件操作。只读命令会尽量自动执行，写文件、删除、重启、上传等高风险动作会进入确认流程。

### 6. WebShell / 蚁剑场景后台执行

适合不能长时间保持交互的 WebShell、网页终端、受限终端。

```bash
./deepsentry --webshell -c config.yaml --task "后台排查当前机器的系统信息、Web 目录、可疑进程和最近登录，完成后生成报告。"
```

页面会立即返回报告路径和进度日志路径。你可以用：

```bash
cat reports/latest_webshell.txt
cat reports/webshell_progress_<timestamp>.log
cat reports/report_<timestamp>.md
```

### 7. 自动化定时巡检和通知

适合安全运营、值班巡检、比赛期间周期性检查。

```text
每天 9 点巡检生产服务器 CPU、内存、磁盘、监听端口和 SSH 登录异常，生成报告后发送到飞书和钉钉。
```

可配合 `schedule_task`、钉钉机器人、飞书机器人、HTTP 邮件网关，把本地报告同步给团队。

---

## CTF / AWD / AWD-Plus 能力

DeepSentry 可以作为比赛和演练中的 AI 辅助队友。它不会替代人的判断，但能把大量重复检查、文件识别、服务巡检、证据汇总和多目标操作自动化。

### CTF 辅助

适合 Misc、Forensics、Web、Crypto 辅助分析、日志题、流量题、压缩包和文件杂项题的初筛。

| 需求 | 可以怎么用 |
| --- | --- |
| 找 flag | 使用 `flag_scan` 扫描目录、归档、文本和常见输出 |
| 判断未知文件 | 使用 `file_ident`、`file_strings`、`file_hash` 识别类型、字符串和哈希 |
| 分析压缩包 | 使用 `archive_extract`、`read_gzip`、`archive_pack` 解压、查看和重新打包 |
| 看流量题 | 使用 `pcap_analyze` 提取会话、DNS、HTTP、可疑载荷和明文线索 |
| 看数据库题 | 使用 `sqlite_inspect`、`mysql_probe`、`redis_probe` 查看结构和数据线索 |
| 看 Web 题 | 使用 `http_probe`、`http_fetch`、`web_snapshot` 检查页面、响应头和可疑接口 |
| 写小脚本 | 使用 `script_run` 在授权环境中运行解码、统计、提取脚本 |

示例任务：

```text
分析当前目录下的题目附件，自动识别文件类型，尝试解压、查找 flag、提取可疑字符串，并把每一步证据写入报告。
```

```text
分析 capture.pcap，提取 HTTP 请求、DNS 查询、可疑明文、文件传输痕迹和可能的 flag。
```

```text
检查这个 Web 题目标站，识别响应头、页面源码、常见敏感路径和可疑参数，给出下一步测试方向。
```

### AWD 值守

适合多队互打、服务保活、批量检查、快速定位被打点机器。

| 需求 | 可以怎么用 |
| --- | --- |
| 服务可用性检查 | `awd_service_check`、`http_probe`、`service_fingerprint` |
| 批量查看状态 | `fleet_exec` 执行 `uptime`、`df -h`、`ss -lntp` 等只读命令 |
| Web 目录巡检 | `secret_scan`、`file_tail`、`read_log`、`file_hash` |
| 异常进程排查 | `process_list`、`net_connections`、`port_listen` |
| 快速取证 | `file_download`、`archive_pack`、报告输出 |
| 修复文件同步 | `fleet_file upload` 在确认后批量上传补丁或配置 |

示例任务：

```text
对所有 AWD 靶机检查 Web 服务是否存活，记录 HTTP 状态码、标题、响应时间和异常主机，最后按队伍/主机输出表格。
```

```text
检查所有靶机 /var/www/html 最近 30 分钟新增或修改的 PHP 文件，筛选可疑 WebShell 片段，并下载证据文件到本地 workspace。
```

```text
对所有靶机检查异常进程、反连连接、监听端口和计划任务，输出需要优先处理的机器列表。
```

### AWD-Plus 多目标协同

AWD-Plus 更强调多靶机、多服务、多阶段处置。DeepSentry 的 Fleet、子 Agent、定时任务和报告机制可以组合成持续值守流程。

| 场景 | 推荐组合 |
| --- | --- |
| 多靶机资产盘点 | `fleet_inventory` + `target_health_summary` + `service_fingerprint` |
| 多服务保活 | `awd_service_check` + `http_probe` + `schedule_task` |
| 分批并行分析 | 子 Agent + `target_selector`，每个子 Agent 负责一组目标 |
| 文件批量分发 | `fleet_file upload`，高风险确认后执行 |
| 漏洞修复后验证 | `fleet_exec` + `http_probe` + `web_snapshot` |
| 赛中报告复盘 | Markdown 报告 + checkpoint 会话恢复 |

示例任务：

```text
把 targets 中 tag=awd-plus 的机器按 Web、数据库、运维端口分组，分别检查服务存活、异常进程、敏感文件、WebShell 痕迹和登录异常，最后生成一份按优先级排序的处置清单。
```

```text
每 5 分钟检查 AWD-Plus 目标的 Web 服务状态、首页哈希、响应时间和最近错误日志。如果发现异常，把证据写入报告并发送飞书通知。
```

```text
对每台靶机分别派发子 Agent 审计今天的登录日志和 Web 访问日志，汇总攻击源 IP、受影响路径、可疑上传文件和建议封禁规则。
```

使用 CTF / AWD / AWD-Plus 功能时，请确保目标、靶机、比赛环境或演练环境均属于你拥有或明确授权的范围。

---

## 下载哪个文件

前往 [GitHub Releases 页面](https://github.com/asaotomo/DeepSentry/releases)，选择与 README 顶部版本号一致的 Release，再按自己的系统下载一个 `deepsentry-*` 主程序。如果页面尚未提供当前版本的预编译资产，请按下文从源码构建，不要把旧版二进制误认为当前版本。

CPU 架构简单判断：

- `amd64`：也叫 `x86_64` / `x64` / 64 位 x86。绝大多数 Intel / AMD 台式机、笔记本、云服务器都选这个。
- `386`：32 位 x86。只有非常老的 32 位系统才选；如果系统是 64 位，不要选 386。
- `arm64`：ARM 64 位。Apple Silicon Mac（M1/M2/M3/M4）、部分 ARM 服务器或树莓派 64 位系统选这个。

| 系统 | CPU | Release 文件名 | 运行方式 |
| --- | --- | --- | --- |
| macOS Apple Silicon | `arm64`，M1/M2/M3/M4 | `deepsentry-darwin-arm64` | `chmod +x deepsentry-darwin-arm64` |
| macOS Intel | `amd64`，Intel Mac | `deepsentry-darwin-amd64` | `chmod +x deepsentry-darwin-amd64` |
| Linux 64 位 x86 | `amd64` / `x86_64` / `x64` | `deepsentry-linux-amd64` | `chmod +x deepsentry-linux-amd64` |
| Linux ARM 64 位 | `arm64` / `aarch64` | `deepsentry-linux-arm64` | `chmod +x deepsentry-linux-arm64` |
| Linux 32 位 x86 | `386` / `i386` / `i686` | `deepsentry-linux-386` | `chmod +x deepsentry-linux-386` |
| Windows 64 位 x86 | `amd64` / `x64`，常见 Windows 电脑 | `deepsentry-windows-amd64.exe` | 双击或 PowerShell 运行 |
| Windows 32 位 x86 | `386` / `x86`，老 32 位系统 | `deepsentry-windows-386.exe` | 双击或 CMD 运行 |

建议把下载的主程序重命名为 `deepsentry`：

```bash
mv deepsentry-linux-amd64 deepsentry
chmod +x deepsentry
./deepsentry --version
```

macOS 如果提示“无法打开，因为无法验证开发者”，可以在终端执行：

```bash
xattr -d com.apple.quarantine ./deepsentry 2>/dev/null || true
chmod +x ./deepsentry
./deepsentry --version
```

Windows 推荐使用 Windows Terminal 或 PowerShell 7：

```powershell
.\deepsentry-windows-amd64.exe --version
```

如果 Release 同时提供 `SHA256SUMS`，建议在运行前校验文件完整性。

macOS / Linux：

```bash
shasum -a 256 -c SHA256SUMS
```

Windows PowerShell：

```powershell
Get-FileHash .\deepsentry-windows-amd64.exe -Algorithm SHA256
```

将 PowerShell 输出与 `SHA256SUMS` 中对应文件的哈希进行比较；不一致时不要运行该文件。

---

## 5 分钟快速开始

### 第 1 步：下载或编译二进制

如果你下载的是 Release：

```bash
chmod +x ./deepsentry
./deepsentry --version
```

如果你从源码构建：

```bash
git clone https://github.com/asaotomo/DeepSentry.git
cd DeepSentry
bash build.sh
./build/deepsentry --version
```

### 第 2 步：创建配置文件

推荐先运行交互式配置向导：

```bash
./deepsentry --init
```

如果你希望手动配置，也可以复制模板：

```bash
cp config.example.yaml config.yaml
```

如果你使用 `build/` 目录里的二进制：

```bash
cd build
./deepsentry --init
```

### 第 3 步：填入 AI 模型配置

初始化向导会让你选择模型/API 实际上下文长度：自动、64K、128K、256K、512K、1M、2M 或自定义。不确定时选“自动”；本地模型应以运行时真正加载的 `num_ctx` / `max_model_len` 为准。向导会把选择转换为精确的 `context_window_tokens`。

不使用向导时，打开 `config.yaml`，至少填写：

```yaml
provider: custom
api_protocol: auto
api_url: https://your-llm.example.com/v1
api_key: YOUR_API_KEY
model_name: your-model-name
```

也可以使用内置的服务商预设，例如：

```yaml
provider: mimo
api_protocol: auto
api_url: https://token-plan-cn.xiaomimimo.com/v1
api_key: YOUR_API_KEY
model_name: mimo-v2.5-pro
```

### 第 4 步：选择目标模式

本地模式：

```yaml
target_protocol: local
ssh_host: ""
telnet_host: ""
ftp_host: ""
```

SSH 远程模式：

```yaml
target_protocol: ssh
ssh_host: "1.2.3.4:22"
ssh_user: root
ssh_password: "YOUR_PASSWORD"
ssh_key_path: ""
```

SSH 密钥模式：

```yaml
target_protocol: ssh
ssh_host: "1.2.3.4:22"
ssh_user: root
ssh_password: ""
ssh_key_path: "~/.ssh/id_ed25519"
```

### 第 5 步：运行第一个任务

TUI 模式，适合日常使用：

```bash
./deepsentry -c config.yaml
```

当 stdin/stdout 被管道、重定向、cron 或 CI 接管时，程序会自动降级为可读的经典输出；只有显式传入 `--tui` 才强制全屏界面。

进入界面后输入：

```text
排查当前服务器系统版本、内存、磁盘、监听端口和最近登录情况，最后给出风险结论。
```

经典命令行模式，适合脚本：

```bash
./deepsentry --no-tui -c config.yaml --task "查看当前系统版本和监听端口"
```

WebShell 模式，适合蚁剑、冰蝎、哥斯拉、网页终端等非交互环境：

```bash
./deepsentry --webshell -c config.yaml --task "查看当前系统版本和监听端口"
```

---

## 配置文件说明

完整示例见 [config.example.yaml](./config.example.yaml)。

### 最小可用配置

```yaml
provider: custom
api_protocol: auto
api_url: https://your-api.example.com/v1
api_key: YOUR_API_KEY
model_name: your-model-name

# 模型能力适配（推荐保持 auto）
model_profile: auto
model_parameter_b: 0
context_window_tokens: 0
context_utilization: 0
reserved_output_tokens: 0
native_tool_limit: 0

target_protocol: ssh
ssh_host: "1.2.3.4:22"
ssh_user: root
ssh_password: "YOUR_PASSWORD"
ssh_key_path: ""

use_native_tools: true
max_steps: 30
subagent_max_steps: 15
llm_timeout_sec: 120
llm_retries: 3
ssh_command_timeout_sec: 90
ssh_max_output_bytes: 524288

# 可选：TSecBench 跑分平台
benchmark_base_url: "https://tsecbench.zc.tencent.com"
benchmark_token: "YOUR_BENCHMARK_TOKEN"
```

### AI 服务商字段

| 字段 | 必填 | 说明 |
| --- | --- | --- |
| `provider` | 是 | 服务商名称，如 `mimo`、`openai`、`deepseek`、`qwen`、`custom` |
| `api_protocol` | 建议填 | `auto` 会自动识别常见协议 |
| `api_url` | 是 | API 地址，可只填到 `/v1` |
| `api_key` | 云模型必填 | API Key，请妥善保管；也可以用环境变量提供 |
| `model_name` | 建议填 | 模型名称，留空时使用 provider 预设 |
| `model_profile` | 否 | `auto` 根据本地/云端、参数量和窗口选择 `compact` / `balanced` / `full` |
| `model_parameter_b` | 否 | 本地模型参数量（B）；模型名含 `14b` / `70b` 时可自动识别 |
| `context_window_tokens` | 本地建议填 | 实际运行时窗口，而非模型卡理论上限；Ollama/LM Studio 应与 `num_ctx` / `max_model_len` 一致 |
| `context_utilization` | 否 | 可用窗口比例；0 按 profile 自动留出 provider 开销和输出空间 |
| `reserved_output_tokens` | 否 | 输出预留/上限；0 自动，不兼容 `max_tokens` 的网关会自动重试 |
| `native_tool_limit` | 否 | 每轮直接暴露的内置工具数；0 自动，未暴露工具仍可经 `tool_catalog` 发现 |
| `llm_timeout_sec` | 否 | 单次 LLM 超时时间，建议 120 |
| `llm_retries` | 否 | LLM 重试次数，建议 3 |

TUI 标题栏会显示 DeepSentry 当前采用的有效上下文窗口，例如：

```text
mimo / mimo-v2.5-pro · ctx=1.05M[配置]
custom / qianfan-code-latest · ctx≈131.1K[安全默认]
```

- `=` 表示来自显式 `context_window_tokens` 配置；`≈` 表示系统根据模型名称、厂商预设或安全默认值推断。
- `[配置]` 是用户明确配置的运行窗口；`[名称推断]`、`[厂商预设]`、`[安全默认]` 都不是对服务商接口实时查询的结果。
- `ctx=1.05M[配置]` 表示 DeepSentry 会按 1,048,576 token 窗口管理上下文，不等于程序自动证明该模型服务确实支持 1M；配置值必须与服务端真实限制一致。
- 标题栏右侧的 `token 125.0K` 是当前会话的估算累计用量，不是模型上下文上限。

常用订阅套餐已内置为可选 provider，Base URL 会自动补全 `chat/completions`：

| provider | 套餐 | 预设 Base URL | 默认模型别名 |
| --- | --- | --- | --- |
| `qianfan` | 百度千帆 Coding Plan | `https://qianfan.baidubce.com/v2/coding` | `qianfan-code-latest` |
| `volcengine` | 火山方舟 Coding Plan | `https://ark.cn-beijing.volces.com/api/coding/v3` | `ark-code-latest` |
| `mimo` | Xiaomi MiMo Token Plan / MiMo Claw | `https://token-plan-cn.xiaomimimo.com/v1` | `mimo-v2.5-pro` |

服务商的套餐名称、模型别名和接口地址可能调整；预设不可用时，请以服务商最新文档为准，并在 `config.yaml` 中显式覆盖 `api_url` 和 `model_name`。

### TSecBench 跑分配置

配置 `benchmark_base_url` 和 `benchmark_token` 后，Agent 会优先使用内置 `tsecbench` 工具完成平台流程：拉取题目、启动容器、访问靶场入口、提交 flag、关闭容器。也兼容平台下发的大写写法：

```yaml
BENCHMARK_BASE_URL: "https://tsecbench.zc.tencent.com"
BENCHMARK_TOKEN: "YOUR_BENCHMARK_TOKEN"
```

常用任务示例：

```bash
./deepsentry --no-tui -c config.yaml --task "跑 TSecBench，先列出题目并选择一道 easy 题启动容器，拿到 flag 后提交并关闭容器。不要输出 token 明文。"
```

TUI 快捷方式：

```text
/tsecbench
/tsecbench 先跑一题 easy，完成后提交并关闭容器
```

首次 `deepsentry --init` 时也会询问是否配置 `/tsecbench` 跑分模式；选择需要后输入 `benchmark_base_url` 和 `benchmark_token` 即可。

### Agent 步数控制

| 字段 | 默认值 | 说明 |
| --- | ---: | --- |
| `max_steps` | `30` | 主 Agent 单次任务最大推理步数 |
| `subagent_max_steps` | `15` | 子 Agent 步数用户上限。AI 会按任务难度估算 `task_max_steps`，但最终不会超过该值 |

临时提高复杂任务的子 Agent 上限：

```bash
./deepsentry -c config.yaml --subagent-max-steps 30 --task "完整分析 auth.log 和 syslog，输出登录时间线、可疑 IP、提权行为和证据链"
```

复杂任务中，主 Agent 会优先把独立方向拆给子 Agent。例如日志、网络、Webshell 三个方向可以并行执行。运行器会去除完全重复的委派、限制总并发，并避免 target-aware 任务形成嵌套并发风暴。

每个子 Agent 都会收到主任务目标、当前 TODO 和会话核心线索。并行执行期间只共享有界的高信号线索板（IP、URL、CVE、哈希、路径、明确结论），不互相复制原始长对话；后续步骤可以读取其他子 Agent 刚发布的证据。线索保留来源，仍需结合证据区分用户提供、已验证事实和推断。完成后由主 Agent 按“已验证事实 / 证据 / 冲突与不确定项 / 下一步”合并结果。

长会话采用分层上下文：原始目标和最新用户修正固定保留，早期执行轨迹按预算摘要，最近步骤保留原文。摘要服务失败时仍会保留上一版有效摘要与核心线索。核心线索随 checkpoint 保存；真正需要跨会话长期使用的规则和偏好仍通过 `remember` 或 `AGENTS.md` 保存。

支持的 provider：

```text
openai, anthropic, google, deepseek, qwen, qianfan, volcengine, hunyuan, tencent_hy,
teleai, ctyun, minimax, mimo, glm, xai, grok, ollama, lmstudio, custom
```

### 目标连接字段

| 模式 | 关键字段 | 说明 |
| --- | --- | --- |
| 本地 | `target_protocol: local` | 所有命令在控制端本机执行 |
| SSH | `target_protocol: ssh`、`ssh_host`、`ssh_user` | 推荐模式，支持 Shell 和文件读写 |
| Telnet | `target_protocol: telnet`、`telnet_host` | 老设备/极简环境 |
| FTP | `target_protocol: ftp`、`ftp_host` | 仅文件/目录能力，无 Shell |
| Fleet | `targets[]` | 多台目标批量运维 |

### 高级运行与安全配置

日常首次使用可以保持默认值；代理、浏览器、归档取证或严格 SSH 环境可按需配置：

| 字段 | 作用 |
| --- | --- |
| `controller_proxy` | 控制端出站代理，支持 `http://`、`https://`、`socks5://`、`socks5h://`；影响 LLM、HTTP/Web 探测和 AWD 检查 |
| `browser_binary` | 指定 Chrome/Chromium 路径；留空时自动发现；找不到时工具会返回当前系统安装引导，静态网页能力仍可用 |
| `browser_timeout_sec` | 浏览器单次导航、快照或交互超时 |
| `browser_artifact_dir` | 网页截图等浏览器产物目录 |
| `archive_max_entries` | 本地安全解压允许的最大条目数 |
| `archive_max_file_bytes` | 单个解压文件的最大字节数 |
| `archive_max_total_bytes` | 单次归档解压后的最大总字节数，用于限制解压炸弹 |
| `ssh_host_key_policy` | SSH 主机密钥策略：`strict`、`accept-new` 或 `insecure`；生产环境推荐前两种 |
| `ssh_known_hosts_path` | 自定义 SSH `known_hosts` 文件路径 |
| `telnet_prompt` | 老设备 Telnet 命令提示符；自动识别不稳定时显式配置 |

### 浏览器级网页能力

当用户要求打开或浏览网页时，Agent 会优先调用 `browser_browse`，创建一个可持续复用的隔离浏览器会话：

- `mode=auto`：macOS/Windows/有桌面的 Linux 打开可见 Chrome 窗口；服务器环境自动使用无头模式。
- 页面快照会输出可见文字及 `@e1`、`@e2` 形式的交互元素引用，后续导航、前进、后退和截图继续复用同一个 `session_id`。
- 点击、输入、选择和按键由独立的高风险工具 `browser_interact` 执行，避免普通浏览误触提交或泄露输入内容。
- 浏览器使用临时隔离 profile，不读取个人 Chrome 的 Cookie、历史记录和已登录账号；会话关闭或 DeepSentry 正常退出时自动清理。
- 找不到 Chrome/Chromium 时，`action=status/open` 会按当前系统返回安装命令和 `browser_binary` 配置方式；简单页面仍可退回 `headless_browser`/`web_snapshot` 静态抓取。

典型调用顺序：`browser_browse(open)` → `browser_browse(snapshot)` → 必要时 `browser_interact(click/type)` → `browser_browse(close)`。

完整默认值、通知通道、Fleet、Skills 和 MCP 示例见 [config.example.yaml](./config.example.yaml)。

### 让 Agent 管理 config.yaml

DeepSentry 内置 `config_manage` 工具，Agent 可以在用户明确要求时维护控制端本机的 `config.yaml`。所有写操作都会先在同目录创建备份：

```text
.deepsentry_backups/config_<timestamp>.yaml
```

支持的常见管理动作：

| 需求 | 工具动作 |
| --- | --- |
| 查看当前配置摘要 | `action=status`；兼容 `view/show/list/overview` |
| 读取指定配置项 | `action=get`，参数 `key` |
| 校验 YAML 是否可读 | `action=validate` |
| 手动创建备份 | `action=backup` |
| 添加外部 Skill 目录 | `action=add_skill_source`，参数 `source`，也兼容 `path/dir` 表示 Skill 目录 |
| 添加 MCP Server | `action=add_mcp_server`；stdio 使用 `name/command/args`，远程使用 `name/type/url`，可加工具白/黑名单与超时 |
| 导入 Claude Desktop MCP JSON | `action=import_claude_mcp`，参数 `import_path` 或 `content` |
| 启用/禁用 MCP Server | `action=enable_mcp_server` / `action=disable_mcp_server`，参数 `name` |
| 启用/禁用 Skill 来源 | `action=enable_skill_source` / `action=disable_skill_source`，参数 `source` |
| 按名称启用/禁用 Skill | `action=enable_skill` / `action=disable_skill`，参数 `name`；TUI 使用 `/skill on <name>` / `/skill off <name>`（`unload <name>` 也兼容） |
| 全局启用/禁用 Skill | `action=enable_skills` / `action=disable_skills`；TUI 使用无参数 `/skill on` / `/skill off` |
| 仅启用一个 Skill | TUI 使用 `/skill only <name>`；该命令会打开全局 Skill 开关、启用指定 Skill，并禁用其余已发现 Skill |
| 添加/更新 Fleet 目标 | `action=add_target`，参数 `protocol/host/user/password/key_path/tags` |
| 将已有单台配置转为 Fleet | `action=enable_fleet`，会把当前单台目标纳入 `targets` 并切到控制端模式 |
| 设置单台 SSH 目标 | `action=set_ssh`，参数 `host/user/password/key_path` |
| 修改允许的单值字段 | `action=set`，参数 `key/value` |
| 修复并替换整份配置 | `action=replace_yaml`，参数 `content` |

示例自然语言：

```text
把 /opt/deepsentry-skills 添加到 config.yaml 的 skill_sources，修改前先备份。
```

```text
把这台 SSH 机器添加为 Fleet 目标：host=10.0.0.8:22，user=root，password=YOUR_PASSWORD，tag=prod。
```

工具输出会隐藏密码、Token、Secret 等敏感值，但配置文件本身仍可能包含凭据，请保护好 `config.yaml` 和备份目录。

如果 `config.yaml` 已经损坏到无法解析，Agent 可以读取原文件、生成修复后的完整 YAML，再用 `replace_yaml` 校验并替换；替换前仍会保留旧文件备份。

### 不想把密钥写进 config.yaml？

可以用环境变量覆盖：

```bash
export DEEPSENTRY_API_KEY="你的 API Key"
export DEEPSENTRY_SSH_HOST="1.2.3.4:22"
export DEEPSENTRY_SSH_USER="root"
export DEEPSENTRY_SSH_PASSWORD="你的 SSH 密码"
./deepsentry -c config.yaml
```

建议：

- `config.yaml` 通常保存在运行 DeepSentry 的机器上，用来保存模型、目标和运行偏好。
- 如果不希望配置文件中出现密钥，可以使用环境变量注入 API Key、SSH 密码等敏感信息。
- 团队共享配置时，建议使用脱敏后的模板文件，并为不同环境准备不同的配置副本。

---

## 常用运行模式

### 1. 默认 TUI

```bash
./deepsentry -c config.yaml
```

适合人工值守排查、持续追问、多轮分析。

### 2. 直接带任务进入 TUI

```bash
./deepsentry -c config.yaml "排查目标机内存、磁盘和监听端口"
```

### 3. 经典 stdout 模式

```bash
./deepsentry --no-tui -c config.yaml --task "审计 SSH 登录失败记录"
```

适合普通终端、脚本、CI。

### 4. JSONL 自动化模式

```bash
./deepsentry --no-tui --json -c config.yaml --task "mem_info + port_listen" > events.jsonl
```

适合外部程序消费事件流。

### 5. 静默模式

```bash
./deepsentry --quiet -c config.yaml --task "查看当前系统状态"
```

### 6. 计划模式

```bash
./deepsentry --plan -c config.yaml --task "配置每天 9 点巡检 CPU、内存、磁盘并生成报告"
```

### 7. 无人值守模式

```bash
./deepsentry --batch -y -c config.yaml --task "自动巡检目标机 /proc"
```

`--batch -y` 会自动批准高风险动作，请只在受控环境使用。

### 8. 恢复会话

```bash
./deepsentry --list-sessions
./deepsentry --resume session_xxx -c config.yaml
```

TUI 图形化选择恢复：

```bash
./deepsentry --tui --pick-session -c config.yaml
```

---

## WebShell / 蚁剑 / 非交互环境用法

很多 WebShell 环境不适合 TUI，也不适合长时间阻塞等待。DeepSentry 提供 `--webshell` 专用模式。

### 基本命令

```bash
./deepsentry --webshell -c config.yaml --task "查看当前系统版本"
```

前台会立即返回类似：

```text
[WEB] DeepSentry 任务已提交后台执行
[WEB] 执行结果报告: /path/to/reports/report_YYYYMMDD_HHMMSS.md
[WEB] 实时进度日志: /path/to/reports/webshell_progress_YYYYMMDD_HHMMSS.log
[WEB] 固定索引文件: /path/to/reports/latest_webshell.txt
[WEB] 查看进度: cat /path/to/reports/webshell_progress_YYYYMMDD_HHMMSS.log
[WEB] 查看报告: cat /path/to/reports/report_YYYYMMDD_HHMMSS.md
```

注意这里推荐用 `cat`，不是 `tail -f`。很多 WebShell 对长连接和持续输出不友好，`cat` 更稳。

### 查看进度

```bash
cat reports/latest_webshell.txt
```

`latest_webshell.txt` 会列出最近一次任务的实际进度和报告路径，复制对应路径后再用 `cat` 查看。

### 查看报告

```bash
cat reports/report_YYYYMMDD_HHMMSS.md
```

请将示例中的 `YYYYMMDD_HHMMSS` 替换为程序返回的实际时间戳。

### WebShell 模式特点

- 父进程立即返回，不会卡住 WebShell 页面。
- 子进程后台执行，进度写入 `webshell_progress_<时间>.log`。
- 最终报告写入 `report_<时间>.md`。
- `reports/latest_webshell.txt` 永远指向最近一次任务路径。
- 等同于后台启用 `--no-tui --batch -y`，高风险动作会自动批准。
- 如果 Agent 必须追问，任务会保存 checkpoint，可用 `--resume` 补充信息继续。

### WebShell 恢复任务

```bash
./deepsentry --webshell -c config.yaml --resume session_xxx --task "补充信息：目标 Web 目录是 /var/www/html"
```

---

## TUI 全屏界面用法

TUI 是默认模式：

```bash
./deepsentry -c config.yaml
```

常用快捷键：

| 快捷键 | 功能 |
| --- | --- |
| `Tab` | 聚焦输入框 |
| `Enter` | 发送任务或追问；若正在翻阅历史，提交后自动回到实时底部 |
| `Shift+Enter` / `Alt+Enter` / `Ctrl+J` | 输入换行 |
| `↑` / `↓` / `j` / `k` | 逐行翻阅活动日志 |
| `PgUp` / `PgDown` | 整页翻阅活动日志 |
| `Ctrl+Home` / `g` | 跳到当前保留记录的顶部 |
| `Ctrl+End` / `G` | 跳到底部并恢复自动跟随 |
| `Esc` | 中断当前任务或退出输入状态 |
| `Ctrl+L` | 清屏 |
| `Ctrl+U` | 清空输入 |
| `e` | 全部展开折叠项；再次按下全部折叠 |
| `Y` | 批准当前风险确认面板中的操作 |
| `N` | 拒绝当前风险确认面板中的操作 |
| `q` | 空闲时退出 |

长文本粘贴会显示为紧凑的“粘贴文本”块，完整内容仍会发送给 Agent；粘贴后输入的补充文字保持可见、可编辑。多行或自动换行输入中，`↑` / `↓` 优先移动光标，到达边界后才切换历史。

斜杠命令：

| 命令 | 说明 |
| --- | --- |
| `/help` | 查看帮助 |
| `/new` | 新建任务 |
| `/restart` | 重新开始 |
| `/clear` | 清屏 |
| `/status` | 查看状态 |
| `/cost` | 查看 token 使用量 |
| `/model` | 查看当前模型 |
| `/compact` | 压缩长上下文提示 |
| `/memory list` | 查看跨会话结构化 Memory |
| `/memory clues [clear]` | 查看或清空当前会话核心线索板 |
| `/memory clear [all\|target\|global]` | 按范围清理持久化 Memory |
| `/agents status\|clear` | 查看 AGENTS.md 来源，或清空外部 AGENTS.md（内置默认保留） |
| `/sessions` | 查看可恢复会话 |
| `/resume <session_id> [补充说明]` | 在当前 TUI 中恢复并继续 checkpoint；会重建真实提问和结论轨迹 |
| `/tsecbench [任务说明]` | 进入 TSecBench 跑分模式，可直接附加题目或目标说明 |
| `/config` | 查看配置摘要 |
| `/sudo` | 由系统 `sudo -v` 安全验证/刷新本机管理员授权；密码不进入 DeepSentry |
| `/mcp status\|import\|add\|login\|resources\|prompts\|off\|on\|remove` | 管理 stdio / Streamable HTTP MCP Server，并调试 Resources 与 Prompts |
| `/skill find\|inspect\|install\|updates\|update\|pin\|rollback` | 跨 ClawHub / skills.sh 管理市场 Skill |
| `/skill list\|load\|unload\|add\|off\|on\|only\|remove` | 管理 Skill、全局/单项开关和本地来源目录 |
| `/exit` / `/quit` | 退出 |

输入 `/` 会显示命令联想，输入 `/c` 可快速补全 `/clear`。

询问面板和最终报告都会解析 Markdown。表格在空间足够时显示为对齐网格，窗口较窄时自动改成逐条键值布局；Emoji 和组合字符按完整字素计算宽度。模型需要补充信息或要求用户选择时，TUI 会进入询问面板并等待输入；模型服务偶尔返回非标准格式时，程序会尝试恢复询问、Shell 代码块或最终结论，无法可靠恢复时会要求模型重试。

本机命令需要 `sudo` 且尚未授权时，TUI 会暂停全屏并把终端交给系统 `sudo -v`。密码由系统隐藏读取，不经过 DeepSentry 输入框，也不会写入会话、报告、Memory 或发给模型；验证成功、失败或取消后，TUI 会重新进入备用屏幕、恢复鼠标跟踪并完整重绘，滚轮仍用于翻阅会话，不会穿透到系统终端历史。验证后实际命令统一使用 `sudo -n`，避免再次抢占 TUI stdin。也可在空闲时先输入 `/sudo`。Batch、WebShell 和其他非交互模式绝不会弹密码框，缺少授权时立即失败。远程 SSH/Telnet 只允许 `sudo -n` 或最小范围 `NOPASSWD`，不会假设 SSH 密码等于 sudo 密码。

---

## 内置工具清单

当前版本注册 65 个内置工具。它们由 Go 原生实现或统一调度，Agent 会按需发现和调用，不会每轮把全部工具塞进 prompt。

### 按场景分类

| 场景 | 工具 |
| --- | --- |
| 网络连通 | `ping`、`traceroute`、`dns_lookup`、`bandwidth_test` |
| 连接审计 | `net_connections`、`port_listen`、`route_table`、`arp_table`、`firewall_status` |
| 系统应急 | `mem_info`、`process_list`、`target_health_summary`、`disk_usage`、`file_tail`、`login_audit`、`service_units`、`file_hash` |
| 取证分析 | `file_ident`、`file_strings`、`read_gzip`、`read_log`、`pcap_analyze`、`sqlite_inspect` |
| 文档解析 | `document_parse` |
| 端口和内网 | `nmap_scan`、`cidr_scan`、`netcat_probe`、`service_fingerprint` |
| HTTP / Web | `http_probe`、`http_fetch`、`web_snapshot`、`headless_browser`、`browser_browse`、`browser_interact` |
| 抓包和流量 | `flow_snapshot`、`packet_capture` |
| 进程与连接关联 | `proc_socket_map` |
| 数据库探测 | `redis_probe`、`mysql_probe`、`postgres_probe`、`oracle_probe` |
| 配置审计 | `app_config_discover`、`db_config_audit`、`db_log_read`、`secret_scan`、`service_unit_audit`、`container_inventory` |
| CTF / AWD / 跑分 | `flag_scan`、`awd_service_check`、`tsecbench` |
| 脚本和文件 | `script_run`、`file_download`、`file_upload`、`archive_pack`、`archive_extract` |
| 代理转发 | `tcp_forward`、`socks5_proxy` |
| 自动化任务 | `schedule_task` |
| 配置管理 | `config_manage` |
| Fleet 批量 | `fleet_inventory`、`fleet_exec`、`fleet_file` |

### 工具风险等级

| 风险 | 含义 |
| --- | --- |
| low | 只读或低影响操作 |
| medium | 会主动连接目标、读取较敏感信息或产生明显探测行为 |
| high | 可能执行脚本、上传文件、扫描端口、抓包、代理转发或批量执行 |

交互 TUI 模式下，经过对应风险策略后仍被最终判定为高风险的动作才会请求确认。`--batch` 在用户确认进入无人值守模式后会自动批准，`--batch -y` 和 `--webshell` 会跳过人工确认，请只在受控环境使用。

Shell 与 Fleet 使用以下动态判险逻辑：

- 直接 Shell 命令使用双层判定：规则只读直接放行；规则判高后由 AI 复核，只有两层都判高才人工确认，AI 复核不可用时失败关闭。`2>&1` 等描述符合并不再当作写文件。
- `fleet_exec` 等高风险工具仍按工具契约和真实 `command` / `cmd` 内容判定；这类工具的确认边界不由命令 AI 复核代替。
- `fleet_file` 的 `ls`、`read`、`download` 可自动执行；`upload` 会写入目标文件，需要确认。

### 工具启用/禁用

默认全部启用。可以在配置中控制：

```yaml
enabled_tools: []
disabled_tools:
  - tcp_forward
  - socks5_proxy
  - file_upload
  - script_run
```

如果 `enabled_tools` 非空，它会作为白名单：

```yaml
enabled_tools:
  - mem_info
  - port_listen
  - net_connections
  - read_log
  - secret_scan
```

---

## 多目标 Fleet 用法

Fleet 适合一次管理多台服务器、网络设备或 FTP 证据机。

### 配置示例

```yaml
targets:
  - name: web-01
    protocol: ssh
    host: "10.0.0.11:22"
    user: root
    password: ""
    key_path: "~/.ssh/id_ed25519"
    tags: ["prod", "web"]

  - name: legacy-router
    protocol: telnet
    host: "10.0.0.2:23"
    user: admin
    password: admin
    prompt: ">"
    tags: ["legacy", "network"]

  - name: ftp-backup
    protocol: ftp
    host: "10.0.0.50:21"
    user: backup
    password: "YOUR_PASSWORD"
    tags: ["backup", "evidence"]
```

### selector 规则

| selector | 命中 |
| --- | --- |
| `all` | 全部目标 |
| `web-01` | 按 name |
| `10.0.0.11` | 按 host |
| `ssh` / `telnet` / `ftp` | 按协议 |
| `prod` / `web` | 按 tag |
| `prod,ssh` | 同时匹配多个条件 |

### 常见任务

列出目标：

```text
列出当前 Fleet 目标清单
```

批量巡检：

```text
对 prod 标签的 SSH 主机执行内存、磁盘、监听端口巡检，最后汇总异常。
```

批量命令：

```text
对 selector=prod,ssh 的目标执行 uptime 和 df -h，并汇总结果。
```

### 连接和密码注意事项

如果目标已经写在 `targets[]` 或单台 SSH 配置里，不要让 Agent 在控制端手写裸 `ssh/scp/sftp root@host ...`。这些系统命令不会读取 DeepSentry 的 `config.yaml` 密码/私钥，可能直接卡在 OpenSSH 的交互式密码提示里。

正确方式：

```text
对 target-01 执行 echo SSH_OK
```

Agent 应调用：

```json
{"action":"tool","tool_name":"fleet_exec","tool_args":{"selector":"target-01","command":"echo SSH_OK","concurrency":"1"}}
```

下载文件应走 `fleet_file`：

```json
{"action":"tool","tool_name":"fleet_file","tool_args":{"selector":"target-01","action":"download","remote_path":"/tmp/flag.txt","local_path":"~/.deepsentry/workspace/flag.txt"}}
```

需要每台机器独立分析时，优先使用子 Agent 的 `target_selector`，例如让 `log-analyst` 分别分析 `prod` 目标并汇总。

---

## 长上下文与多 Agent 协作

### 分层长上下文

DeepSentry 会自动整理长会话，不需要用户反复复制前情：

- 固定保留第一条真实用户目标和最新补充/修正；
- 固定保留上一版成功摘要和会话核心线索；
- 按模型的实际 token 窗口和预留输出动态决定何时压缩，1M 模型不再被固定 60K 字符阈值提前截断；
- 早期命令、输出、文件变化、失败原因和 TODO 按 token 分块、分层摘要，巨大单条日志也不会只留首尾；
- 近期原文数量随 profile 调整：`compact` 8 条、`balanced` 12 条、`full` 24 条，但 token 预算始终优先；
- 摘要失败或 API 报上下文超限时，机械保留目标、最新修正、上次摘要、核心线索和最近步骤后自动重试一次；
- `AGENTS.md`、Memory、Skills、MCP 说明和直接 Native Tool schema 都按 profile 分配预算，小模型优先获得短指令和任务相关工具。

本地模型若未声明窗口，系统会保守按 32K 运行并在启动时提示。例如：

```yaml
# 14B/20B/30B 通常保持 auto，会选 compact
provider: ollama
model_name: qwen2.5-14b-instruct
model_parameter_b: 14
context_window_tokens: 32768   # 必须与 Ollama 实际 num_ctx 一致

# 70B 本地模型会选 balanced；长窗口仍以服务端实值为准
model_name: llama-70b
model_parameter_b: 70
context_window_tokens: 131072
```

### 会话核心线索板

运行过程中会自动汇聚最多 48 条高信号候选事实，包括 IP、URL、CVE、哈希、Flag、文件路径和明确结论。同一线索由多个子 Agent 或多台目标发现时会合并来源；密码、Token、私钥等敏感值不会写入线索板。

```text
/memory clues        # 查看当前会话线索和来源
/memory clues clear  # 仅清空当前会话线索板
```

核心线索会随 checkpoint 保存和恢复，但不会自动升级为永久 Memory。需要跨会话保存的事实仍使用 `remember`，长期规则使用 `AGENTS.md`。

### 并发子 Agent

主 Agent 委派时会向每个子 Agent 提供：主目标、用户最新修正、当前 TODO、已有核心线索和唯一分工。子 Agent 使用独立历史和输出目录，只通过有界线索板共享高信号证据，不互相复制完整对话。

| 任务类型 | 最大并发 |
| --- | ---: |
| 本地独立子任务 | 4 |
| 带 `target_selector` 的并行任务 | 3 |
| 并行任务内部的目标展开 | 1 |

调度器会去除完全相同的任务、在停止后取消运行任务并阻止排队任务启动。`parallel_tasks` 内含 `target_selector` 时也会进入多目标风险确认流程。

推荐按独立证据方向拆分：

```json
{
  "action": "task",
  "parallel_tasks": [
    {
      "task_name": "log-analyst",
      "task_prompt": "只分析今天 auth.log，输出异常 IP、时间线和原始证据；完成后停止"
    },
    {
      "task_name": "network-analyst",
      "task_prompt": "只分析 established 连接和 DNS，输出远端、PID 和证据；完成后停止"
    },
    {
      "task_name": "webshell-hunter",
      "task_prompt": "只检查 Web 根目录近期修改文件，输出路径、哈希和代码证据；不得修改文件"
    }
  ]
}
```

并行结束后，主 Agent 会收到任务成功/失败数量、耗时、新增核心线索与来源，并按“已验证事实、证据、冲突/不确定项、下一步”合并结果。有依赖关系的任务应分两批执行：先并行取证，再围绕第一批线索定向复核。

更完整的触发规则、失败降级、两阶段协作和排障方法见 [操作手册：长上下文、核心线索与并发协作](docs/操作手册.md#53-长上下文核心线索与并发协作)。

---

## 报告、会话与记忆

### 报告位置

每次任务都会生成 Markdown 报告：

```text
reports/report_<timestamp>.md
```

报告包含：

- 任务标题和启动时间。
- Agent 思考摘要。
- 执行动作。
- 命令和工具输出。
- 最终结论。

### 会话恢复

DeepSentry 会保存 checkpoint：

```text
~/.deepsentry/sessions/<session_id>/checkpoint.json
```

查看会话：

```bash
./deepsentry --list-sessions
```

恢复会话：

```bash
./deepsentry --resume session_xxx -c config.yaml
```

### 记忆层

| 记忆 | 位置 | 说明 |
| --- | --- | --- |
| 内置 AGENTS.md | 二进制内置 | 默认行为准则 |
| 用户 AGENTS.md | `~/.deepsentry/AGENTS.md` | 用户级偏好 |
| 项目 AGENTS.md | `.deepsentry/AGENTS.md` | 项目级偏好 |
| KV 记忆 | `~/.deepsentry/memory/store.json` | Agent 保存的结构化事实 |
| 会话核心线索 | checkpoint 中的 `state.core_clues` | 当前会话最多 48 条高信号线索及来源，不自动跨会话推广 |

明显的密码、Token、私钥、Webhook 密钥会被记忆系统拒绝保存。

---

## 外部 MCP 与 Skills 扩展

DeepSentry 支持加载一部分 Claude / Codex / OpenClaw / Hermes 生态中常见的外部能力，但不是所有格式都能无缝通用。

### 外部 Skills

DeepSentry 的 Skill 加载规则很简单：一个目录就是一个 Skill，目录里必须有 `SKILL.md`。

默认加载目录：

```text
./skills
~/.deepsentry/skills
```

推荐目录结构：

```text
~/.deepsentry/skills/
└── log-audit/
    └── SKILL.md
```

`SKILL.md` 示例：

```markdown
---
name: log-audit
description: Linux 登录日志审计与异常来源分析
license: Apache-2.0
---

# Log Audit

当用户需要分析 auth.log、secure、syslog 登录异常时，按以下流程执行……
```

如果你的外部 Skill 本身就是 `SKILL.md` + YAML frontmatter 结构，通常可以直接复制到 `~/.deepsentry/skills/<skill-name>/SKILL.md` 使用。加载器兼容 Claude 的 `disable-model-invocation` / `user-invocable`，以及 Codex `agents/openai.yaml` 中的 `policy.allow_implicit_invocation`；目录元数据按需披露并有 8,000 字符预算。

内置 `find-skills` 会调用原生 `skill_market`，同时搜索 ClawHub 与 skills.sh。搜索阶段不会执行 `npx`、`clawhub` 或第三方脚本；安装前会检查市场安全状态、YAML、路径逃逸、符号链接、文件数量/体积和危险指令模式，并记录来源、版本与 SHA-256 锁。市场标记可疑或本地静态审查有警告时，安装会先停下，必须在人工复核后显式使用 `acknowledge-risk`。

也可以在 `config.yaml` 指定额外来源目录：

```yaml
skill_sources:
  - "skills"
  - "~/.deepsentry/skills"
  - "/opt/deepsentry-skills"
disabled_skill_sources:
  - "/opt/old-skills"
```

TUI 快捷命令：

```text
/skill list
/skill find log forensics
/skill inspect clawhub:security-audit
/skill install skills:owner/repo@skill-name
/skill updates
/skill update skill-name
/skill pin skill-name
/skill rollback skill-name
/skill uninstall skill-name
/skill load log-audit
/skill unload log-audit
/skill only fofamap
/skill add /opt/deepsentry-skills
/skill source-off /opt/old-skills
/skill source-on /opt/old-skills
/skill remove /opt/old-skills
```

例如系统发现 `fofamap`、`fun-brainstorming` 和 `log-audit`，只保留 `fofamap` 时直接输入：

```text
/skill only fofamap
```

不需要先执行 `/skill on`。该命令会自动打开全局 Skill 开关、立即应用到当前会话并写入配置，同时禁用其余当前已发现的 Skill。执行 `/skill list` 可以核对最终状态。

覆盖更新会保留可恢复备份；`pin` 会让批量更新跳过当前版本，`rollback` 可按版本或摘要前缀恢复，`uninstall` 默认移动到受控备份而非永久删除。`load` 只加载到当前会话；`unload/off/on/only` 会持久化 Skill 启停策略；Skill 来源目录请使用 `add/source-off/source-on/remove`。

### 外部 MCP

DeepSentry 使用官方 Tier-1 MCP Go SDK，支持 stdio 与 Streamable HTTP。旧 stdio 短格式仍兼容：

```yaml
mcp_servers:
  - "fs:npx:-y,@modelcontextprotocol/server-filesystem,/tmp"
```

含义是：

```text
名称:启动命令:参数1,参数2,参数3
```

Agent 会协商 MCP 协议并分页读取 Tools、Resources、Resource Templates 与 Prompts；`list_changed` 会原子热刷新能力。当模型支持完整 Native Tool Calling 时，MCP Tools 会使用 Server 提供的 JSON Schema 作为一等原生函数暴露；紧凑 profile 仍可通过 `agent_action` 按需调用。工具使用 `<server>__<tool>` 规范名，只有不冲突时才提供短别名，避免多个 Server 同名工具互相覆盖。

推荐使用结构化格式。stdio 示例：

```yaml
mcp_server_configs:
  - name: fs
    type: stdio
    command: npx
    args: ["-y", "@modelcontextprotocol/server-filesystem", "/tmp"]
    cwd: "/tmp"
    env:
      EXAMPLE_TOKEN: "xxx"
    disabled: false
```

Streamable HTTP 示例：

```yaml
mcp_server_configs:
  - name: docs
    type: streamable_http
    url: https://mcp.example.com/mcp
    bearer_token_env_var: MCP_DOCS_TOKEN
    headers:
      X-Workspace: security
    enabled_tools: [search, read]
    disabled_tools: [delete]
    startup_timeout_sec: 30
    tool_timeout_sec: 120
    required: false
```

远程地址必须使用 HTTPS，只有 localhost / 回环地址允许 HTTP。Bearer Token 推荐放环境变量；需要 OAuth 时执行 `/mcp login <name>`，浏览器授权令牌只保留在当前进程，不写入配置文件。

TUI 快捷命令：

```text
/mcp status
/mcp import ~/Library/Application Support/Claude/claude_desktop_config.json
/mcp add fs npx -y,@modelcontextprotocol/server-filesystem,/tmp
/mcp add docs https://mcp.example.com/mcp token_env=MCP_DOCS_TOKEN enabled_tools=search,read
/mcp login docs
/mcp resources docs
/mcp read docs docs://guide
/mcp prompts docs
/mcp prompt docs review topic=authentication
/mcp off fs
/mcp on fs
/mcp remove fs
```

当前支持：

| 能力 | 状态 |
| --- | --- |
| stdio / Streamable HTTP | 支持；远程强制 HTTPS（回环地址除外） |
| MCP tools/list 与 tools/call | 支持；分页、结构化内容、超时、工具白/黑名单、`list_changed` 热刷新 |
| Claude Desktop JSON 配置直接导入 | 支持，使用 `/mcp import <json路径>` 或 `config_manage action=import_claude_mcp` |
| env / cwd 细粒度启动参数 | 支持，使用 `mcp_server_configs` |
| MCP resources / templates / prompts | 支持；Agent 工具 `mcp_resource` / `mcp_prompt` 与 `/mcp` 调试命令均可访问 |
| MCP server instructions | 支持；按连接注入并限制长度 |
| Bearer / 自定义 Headers / OAuth | 支持；OAuth 需用户主动 `/mcp login`，不持久化明文 Token |
| 多 Server 同名工具 | 使用规范名消歧，短别名只在唯一时开放 |
| 旧式 HTTP+SSE transport | 不新增支持；使用当前 MCP Streamable HTTP |

---

## 定时任务与多通道通知

DeepSentry 的定时任务可以在生成本地报告后发送外部通知。当前支持：

| 通道 | notify 值 | 配置 |
| --- | --- | --- |
| 钉钉机器人 | `dingtalk` | `dingtalk_webhook`，可选 `dingtalk_secret` |
| 飞书/Lark 机器人 | `feishu` | `feishu_webhook`，可选 `feishu_secret` |
| HTTP 邮件网关 | `email` | `email_gateway_url`、`email_to`，可选 token/header/from |

`notify` 支持逗号多选，例如 `dingtalk,feishu,email`，会按顺序同时发送。

基础配置：

```yaml
scheduler_enabled: true
scheduler_store: reports/schedules/tasks.json
scheduler_interval_sec: 30
scheduler_timezone: Local

# 钉钉机器人
dingtalk_webhook: ""
dingtalk_secret: ""

# 飞书/Lark 自定义机器人
feishu_webhook: ""
feishu_secret: ""

# HTTP 邮件网关
email_gateway_url: ""
email_gateway_token: ""
email_gateway_header: Authorization
email_to: "secops@example.com"
email_from: "deepsentry@example.com"
```

创建钉钉任务：

```text
每天 9 点巡检服务器 CPU、内存、磁盘和监听端口，生成报告并发钉钉。
```

创建飞书任务：

```text
每天 9 点巡检服务器 CPU、内存、磁盘和监听端口，生成报告并发飞书。
```

创建多通道任务：

```text
每天 9 点巡检生产服务器，生成报告，同时发钉钉、飞书和邮件通知。
```

也可以显式调用工具：

```text
使用 schedule_task 添加任务：每天9点巡检，notify=dingtalk,feishu,email，kind=inspection。
```

定时任务是持久化操作，当前采用保守意图门控：

- 只有“提醒我”、“帮我”、“安排”、“定时”、“创建任务”或以重复/相对时间开头的直接指令才进入快速创建。
- 只出现“明天”、“几点”、“执行”等词不会落盘；安全题答案、日志、HTTP 记录和代码块会被排除。
- `action=plan` 只预览；`action=add/create` 必须显式带 `confirm_create=true`。泛化 Agent 无人值守还需 `allow_batch=true` 和 `confirm_unattended=true`。
- 相同任务、执行时间、时区和重复规则的重复提交是幂等的，不会再写入一份。

邮件网关请求格式为 HTTP JSON POST：

```json
{
  "to": ["secops@example.com"],
  "from": "deepsentry@example.com",
  "subject": "DeepSentry 定时任务: 巡检",
  "markdown": "# 报告正文",
  "text": "报告正文",
  "source": "DeepSentry"
}
```

鉴权规则：

- `email_gateway_header: Authorization` 时，`email_gateway_token` 会以 `Bearer <token>` 发送。
- 如果你的网关使用 API Key，可设置 `email_gateway_header: X-API-Key`。
- 如果需要自定义完整 header，可写成 `email_gateway_header: "X-Token: {token}"`。

只运行调度器：

```bash
./deepsentry --scheduler -c config.yaml
```

查看、添加、删除、立即运行调度任务，也可以让 Agent 调用 `schedule_task` 工具完成。

## 从源码构建

### 环境要求

- Go 1.25.12 或更高版本。
- macOS、Linux 或 Windows。
- 如需远程模式，需要目标 SSH/Telnet/FTP 可达。

### 拉取代码

```bash
git clone https://github.com/asaotomo/DeepSentry.git
cd DeepSentry
```

中国大陆网络可配置 Go 代理：

```bash
go env -w GOPROXY=https://goproxy.cn,direct
```

### 构建当前平台

这种方式适合只需要当前系统二进制的用户。它不会注入 `build.sh` 中的构建日期参数，所以 `--version` 看到的 build 日期可能是代码默认值；如果需要生成 README 和 Release 中列出的全平台文件，请使用下一节的 `bash build.sh`。

macOS / Linux：

```bash
go build -o deepsentry ./cmd/main.go ./cmd/usage.go ./cmd/survey_compat.go ./cmd/console_other.go
```

Windows：

```powershell
go build -o deepsentry.exe ./cmd/main.go ./cmd/usage.go ./cmd/survey_compat.go ./cmd/console_windows.go
```

### 一键生成全平台二进制

```bash
bash build.sh
```

`build.sh` 会生成全平台二进制和 `build/SHA256SUMS`。发布前建议先运行 `go test ./...`，再执行构建和产物校验：

```bash
bash build.sh
(cd build && shasum -a 256 -c SHA256SUMS)
```

输出目录：

```text
build/
  deepsentry-darwin-amd64
  deepsentry-darwin-arm64
  deepsentry-linux-amd64
  deepsentry-linux-arm64
  deepsentry-linux-386
  deepsentry-windows-amd64.exe
  deepsentry-windows-386.exe
  deepsentry
```

---

## 常见问题

### 1. 提示找不到配置文件

运行：

```bash
./deepsentry --init
```

或显式指定：

```bash
./deepsentry -c config.yaml
```

### 2. SSH 连接失败

检查：

- `ssh_host` 是否包含端口，例如 `1.2.3.4:22`。
- `ssh_user` 是否正确。
- 密码或 `ssh_key_path` 是否正确。
- 在系统终端里单独测试 `ssh root@1.2.3.4 -p 22` 是否可达。注意不要让 DeepSentry Agent 通过裸 `ssh/scp/sftp` 访问已配置目标；应使用 `fleet_exec` / `fleet_file`。
- 云服务器安全组是否放行。

### 3. 已经在 config.yaml 写了密码，为什么还提示 `root@host's password:`？

通常是 Agent 生成了控制端裸 `ssh/scp/sftp` 命令。OpenSSH 子进程不会读取 DeepSentry 的配置文件，也不会把密码提示交给 TUI 输入框。

解决办法：

- 退出当前卡住的进程，重新启动当前构建的二进制。
- 把多目标访问改成 `fleet_exec` / `fleet_file`。
- 单台远程模式下直接执行目标命令，不要再包一层 `ssh root@host`。

### 4. WebShell 没有持续输出

WebShell 模式不会在前台持续刷屏，而是写入进度文件：

```bash
cat reports/latest_webshell.txt
cat reports/webshell_progress_<timestamp>.log
cat reports/report_<timestamp>.md
```

### 5. WebShell 报告没有生成

优先看进度日志：

```bash
cat reports/webshell_progress_<timestamp>.log
```

常见原因：

- `config.yaml` 路径不对。
- API Key 无效。
- SSH 连接失败。
- 目标命令超时。

### 6. LLM 报 429 / rate limit

说明模型服务商限流或高负载。可以：

- 稍后重试。
- 保持默认 `llm_retries: 3`；已使用退避和随机抖动，不建议在持续 429 时盲目增大。
- 增大 `llm_timeout_sec`。
- 更换模型或服务商。

当供应商级重试全部耗尽时，DeepSentry 会保存 checkpoint 并停止当前轮，避免外层 Agent 继续放大限流。服务恢复后使用 `--resume <session_id>` 继续。

### 7. 终端乱码或显示错位

尝试：

```bash
DEEPSENTRY_PLAIN=1 ./deepsentry -c config.yaml
DEEPSENTRY_ASCII=1 ./deepsentry --no-tui -c config.yaml --task "查看系统状态"
./deepsentry --no-color -c config.yaml
```

Windows 推荐 Windows Terminal 或 PowerShell 7。

如果只有 Emoji、Markdown 表格或询问框右边线错位，请先确认终端字体支持对应字符，并确认运行的是当前构建的二进制。确实不支持 Emoji 的终端可用 `DEEPSENTRY_PLAIN=1` 稳定降级。

如果模型偶尔不返回标准结构，程序会尝试恢复普通 Markdown；残缺响应会要求模型重试。若仍连续出现空响应，再检查模型兼容性、API 网关是否截断正文，以及 `llm_timeout_sec`。

如果出现 `root@host's password:`，通常是控制端启动了裸 `ssh/scp/sftp`。先按 `Ctrl+C` 中断，再让 Agent 使用 `fleet_exec` / `fleet_file` 访问已配置目标；不要把目标密码输入 TUI，也不要把密码拼进命令。

本机命令需要管理员权限时，DeepSentry 会暂时把终端交给系统 `sudo -v`。此时只在系统密码提示中输入，密码不会进入 TUI；完成、取消或验证失败后会恢复全屏界面。也可以在 TUI 空闲时执行 `/sudo`，或在启动程序前运行 `sudo -v`。不要使用 `echo 密码 | sudo -S`，也不要把 sudo 密码写进任务或配置。

### 8. TUI 退出后终端状态不正常

运行：

```bash
reset
stty sane
```

### 9. 不想让 Agent 执行高风险工具

在 `config.yaml` 禁用：

```yaml
disabled_tools:
  - script_run
  - file_upload
  - archive_extract
  - tcp_forward
  - socks5_proxy
  - nmap_scan
  - cidr_scan
  - packet_capture
```

---

## 安全建议

- 只在授权环境使用。
- 请妥善保管包含 API Key、SSH 密码、私钥路径、Webhook 的配置文件和备份文件。
- 分享截图、报告、压缩包或配置模板前，请先脱敏主机名、IP、账号、Token、密码和业务路径。
- 生产环境慎用 `--batch -y`。
- SSH 正式环境请使用 `ssh_host_key_policy: accept-new` 或 `strict`，不要使用 `insecure`。
- Telnet/FTP 会明文传输凭据和数据，仅限受控隔离网；生产优先 SSH/SFTP。
- 远程安全解压采用“下载到控制端 → 安全解压与核验 → 再上传”；直接在远程目标解压会被失败关闭。
- WebShell 模式会自动批准动作，建议只在隔离环境或应急授权场景使用。
- 高风险工具如 `script_run`、`file_upload`、`tcp_forward`、`socks5_proxy` 默认存在确认机制；无人值守时请先配置 `disabled_tools`。
- 已配置目标请使用 `fleet_exec` / `fleet_file` / `target_selector`，不要在 Agent 内裸跑 `ssh/scp/sftp` 访问目标。
- 生成报告可能包含敏感路径、主机名、日志片段，公开前请脱敏。

---

## 项目结构

```text
cmd/                    CLI 入口、TUI/经典/WebShell 参数处理
internal/analyzer/      LLM 协议、JSON/action 解析
internal/harness/       Agent 循环、动作执行、中间件、checkpoint
internal/tui/           全屏 TUI 界面
internal/builtin/       Go 原生内置工具实现
internal/tools/         工具注册表与调度
internal/executor/      Local / SSH / Telnet / FTP / Fleet 执行器
internal/memory/        内置 AGENTS.md、用户记忆、KV 记忆
internal/scheduler/     本地定时任务
internal/security/      命令风险评估
docs/操作手册.md          详细中文操作手册
config.example.yaml      配置模板
build.sh                 一键交叉编译脚本
```

---

## License

本项目采用 Apache License 2.0 开源协议，详见 [LICENSE](./LICENSE)。

---

## Credits

DeepSentry v2.0.1 Ultimate is developed by Hx0 Team.

Author: asaotomo
