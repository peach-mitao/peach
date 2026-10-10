# 测试与依赖

这份文档讲三件事：依赖怎么装、怎么升级；改完代码要跑哪些测试、CI 怎么分；新测试该写成什么样。

## 环境与锁文件

依赖由 uv 按锁文件精确复现。源码安装用 `uv sync --locked`。开发、测试和构建在隔离工作树里建自己的 `.venv`，工作树不碰正在服务的环境；主检出的依赖同步与迁移由重启流程负责，见 [运行与配置](OPERATIONS.md) 的「刷新源码运行态」一节（ADR-0091）。

安装全部测试依赖（先完成前端依赖安装和构建，再开始正式验证）：

```text
uv sync --locked --all-extras
```

添加直接依赖并同时更新清单和传递锁文件；版本必须精确固定：

```text
uv add "包名==版本"
```

构建环境只选择构建依赖：

```text
uv sync --locked --extra build
```

提交 `pyproject.toml` 与 `uv.lock`。CI 用 `--locked` 拒绝过期锁文件；Dependabot 的 `uv` 生态负责更新。`uv pip install` 只用于临时环境或安装产物，不用来维护项目依赖。普通 pip 安装 wheel 的冒烟另外独立验证打包声明。

### 接手 Dependabot 的升级

Dependabot 的 PR 一律在本地接管，不在网页上合：

- npm 的两份清单各有一层派生产物：根 `package.json` 对应 `web/vendor/**` 与 `web/index.html` 的版本注释，`frontend/package.json` 对应 `web/dist/` 的主界面与独立页面包。Dependabot 算不出这些，它的 workflow 拿到的 token 又是只读的，推不回 `dependabot/**`，所以 `npm run check:vendor` 或前端产物检查会失败。
- uv 与 github-actions 没有派生产物，但 master 在本机集成、通常领先 origin。在网页上合会让两边分叉，回并要在主检出 master 上 merge，被 `scripts/githooks/` 拒收。

每周的升级在一个隔离工作树里一次接完：

1. 运行 `scripts/adopt_dependency_bump.py --all-open --co-author '<工具> (<模型>) <厂商 noreply>'`，看它列出的 PR 与各自的清单。
2. 加 `--apply`，按编号从小到大一个 PR 一个提交：取回分支，只把它自己对清单的改动三方合并套进来，npm 重算派生产物，uv 跑 `uv lock --check`。
3. 两个 PR 改到相邻行时脚本停下，报出冲突文件并在 `build/adopt-pr-<编号>.txt` 备好提交说明。按它印出的步骤解冲突、重算、提交，再跑一次 `--all-open --apply`；已接管的 PR 按提交说明跳过。
4. 跑 `test.ps1 full`，走 ready / integrate，推送 master 后按它印出的 `gh pr close` 逐个关 PR。PR 显示为 Closed 而不是 Merged，因为提交是在本地重做的。
5. 同一轮跑 `scripts/check_reference_updates.py check --cadence weekly --diff`，查 Dependabot 管不到的上游：按 sha 钉住的 amane 是否前移，Peach 代码直接消费或逐字复制的参考来源是否变化。审阅与 `accept` 按 `peach-reference-evidence` 技能；amane 前移单开分支升级。

单个 PR 用 `--pr <编号>`，流程相同。`.github/dependabot.yml` 把每个生态的 minor 与 patch 合成一个 PR，semver-major 照常一个包一个 PR，接管前先读变更说明。已知要改代码才能升的大版本（如 `@tanstack/react-table` v9）由 `ignore` 挡在自动 PR 之外，迁移单开分支做。

版本来自 `src/peach/__init__.py`，已纳入 uv 缓存键；源码版本更新后再次同步会刷新安装元数据。缓存规则采用 [uv 官方动态元数据机制](https://docs.astral.sh/uv/concepts/cache/#dynamic-metadata)。

## 验证频率

整台机器同时最多跑四个测试重任务：一个分片子进程，或不分片时的整轮测试，各占一个槽位。槽位是 `build/agent-verification/heavy-slot-*.lock` 文件锁，所有工作树与会话共用；槽位全忙时入口排队，等待上限同 `--lock-timeout`，超时以 `2` 退出且不开跑。槽位只限并发，不改变测试内容，不进记录指纹。取消时按已创建的 PID 清理子进程树并归还槽位。

Python 静态检查使用开发依赖 Ruff，随每个正式测试域扫描全仓自有 Python 文件，覆盖应用、脚本、测试和打包入口。规则为 Pyflakes（`F`）、Ruff 支持的 Pylint 错误规则（`PLE`），以及可变默认参数、`finally` 跳转、无效表达式和循环闭包规则（`B006`、`B012`、`B018`、`B023`）。生成的 `downloads_clouddrive_pb2.py` 排除；公开导出的导入用显式同名别名声明。命名、行数、空行和复杂度偏好不属于这套 lint 门槛。

文档与文案检查包含 seiso 稳定规则和最终状态检查，随正式入口执行。分类、范围、独立检查与预览规则用法见 [文档与界面文案](WRITING.md#检查与复核)。seiso 由开发依赖与锁文件固定，运行 Peach 不需要它。

不是每次都跑全量：本机按改动涉及的域选测，CI 按提交类型决定覆盖多宽。

| 场景 | 验证 |
| --- | --- |
| 本机修改 | 正式入口默认 `auto`，按影响域取并集；同代码、环境与范围的有效记录可复用 |
| 普通 PR | macOS 影响域；Windows 关键系统与 Python 3.12 兼容性 |
| 普通主线提交 | macOS 全量；Windows 关键系统与 Python 3.12 兼容性 |
| 实际依赖、迁移、共享测试设施、未知影响面 | 两端 Python 3.14 全量，两端 Python 3.12 关键兼容性 |
| 手动 CI | 完整系统矩阵 |
| wheel | 每次独立最小安装，通常两组；完整矩阵四组 |
| Release | 复用同 SHA 主线成功 CI；构建后执行独立 EXE 冒烟 |

全量在两个独立 runner 按测试文件稳定分片；汇总任务要求所有分片和必需任务成功。分片子进程不签发记录。

浏览器冒烟与设计决定断言（`tests/test_web_e2e.py`）由 `web-e2e` job 在 `windows-latest` 上执行 `web` 域。它装 Node 24、`frontend/node_modules`、ffmpeg，并经 `PEACH_E2E_CHROME` 指定 runner 自带的 Chrome。矩阵扩成全量（`plan` 输出的 `wide`）时，Windows 全量行本身就跑 `web` 域，这个 job 按条件跳过；`verified` 只在这种情况接受它的 skipped，别的 job 跳过照样算红。

浏览器用例覆盖 `frontend/e2e` 下全部 `*.test.ts`，包括子目录，按文件并发、文件内串行。并发数取 `PEACH_E2E_CONCURRENCY`；未设时本机取逻辑核数的四分之一、上限 4，CI（`GITHUB_ACTIONS=true`）为 1。并发时分两批：其余文件一次并发跑完，断言帧数或动画中途位置的文件（`tests/test_web_e2e.py` 的 `CPU_SENSITIVE_SUITES`）随后串行；并发为 1 时按设计决定、交互回归和路由冒烟分组，每批最多 12 个文件。每批限时 600 秒，任一批失败，整轮验证失败。并发的文件共用一个服务和演示库：用例触发的写请求只能落在别的用例不断言的状态上，否则用 `page.route` 拦下或归进串行批。完整 TAP 日志与服务访问日志 `serve.log` 保存在 `build/agent-verification/browser/`，CI 在测试结束后上传其中的 TAP 日志。

需要外部前置条件（Node、ffmpeg、Chrome 等）的用例，本机缺条件时跳过，在 CI（`GITHUB_ACTIONS=true`）里判失败，判定集中在 `tests/support/conditions.py` 的 `missing_prerequisite`。所以 `python` 矩阵里 `core` 以外的行也装 Node，Windows 行另装 ffmpeg 与 Chrome。

本机默认并行：入口传 `--jobs auto`（Windows `-Jobs`），运行器按同一套稳定分片切成并发数四倍的片，最多四个子进程各领一片、先完成的接着领下一片，父进程汇总成败、用例数与逐用例耗时后按原口径签发一份记录，一片红整轮红。`-Jobs 1` 退回串行。测试之间没有共享的端口或全局目录，账本与仓库夹具都在各自的临时目录里，并行才是安全的；新增测试保持这一点。

Windows 的路径、挂载、托盘、证书、进程编码、更新、认证及迁移属于 `core`。构建和工作流修改选择 `packaging` 与 `tooling`；测试调度自身仍全量。仅 uv 工具版本或项目展示字段变化不算依赖图变化；无法解析时全量。

人名对照等业务测试保留：修改相关域时执行，主线全量也执行。测试数据库从真实迁移生成模板，各用例复制独立临时库；迁移测试直接执行迁移。重试测试注入 sleeper 并断言退避序列。重复继承的测试只保留一份。

## 写什么测试

测试应在用户可感知的行为错误时失败。页面的请求、缓存、选择、错误反馈和路由由组件测试与浏览器测试验证；CSS 层叠、主题、尺寸和交互后的样式由浏览器读取计算值。

源码检查集中在通用规范、隐私边界、产物、依赖和跨语言常量一致性。组件名称、变量名、某个函数是否被调用、端点字面量出现几次和文档的具体措辞，不单独设门槛。一个失败模式优先在最便宜且能真实触发它的层验证；组件已验证的业务分支，不在 Python 中再逐段比对其源码。浏览器保留真实导航、布局、焦点与层叠等需要浏览器才能成立的检查。

按下面的分工写：

- 行为（点了发出什么请求、状态怎么变、算出什么值）写 vitest（`frontend/test/`）或 `tests/test_web_js.py`；后端调用真函数或真接口。
- 用户定过的设计决定写进对应区域的 `frontend/e2e/design-*.test.ts`（共用 `design-fixture.ts`），读 `getComputedStyle`；布局与运行期不变量进 `smoke.test.ts`。
- 源码文本断言只减不增，由 `tests/test_source_assertion_ratchet.py` 按文件计数拦截。已有行为或浏览器验证的实现文本断言直接清退；确有行为缺口时才补用例，并同步降低基线。
- 先列失败模式再写用例。异步请求的中间态用手动放行的 Promise 验证；假 fetch 在同一个 `act` 里就回话，会掩盖请求未完成时的时序问题。
- 修缺陷先写一条会失败的用例，看它红了再修；修完按同一写法搜别处，有同类就收成共用实现。没有行为缺口的改动（文案、纯样式）不补回归用例。
- 不写同义反复的用例：断言常量等于它自己、mock 掉被测对象再断言 mock 被调用，都证明不了什么。

## 正式入口

测试只从下面两个入口跑，入口负责选测、签发测试记录和环境预检，自己拼的命令拿不到有效记录。

Windows 按影响域验证：

```powershell
& .\scripts\test.ps1
```

macOS 按影响域验证：

```sh
./scripts/test.sh
```

显式全量用 Windows `-Scope full` 或 macOS 首参数 `full`。入口通过 `scripts/test_environment.py` 准备 Python 依赖，再核对源码位置、选测并记录慢测试。隔离工作树按 `uv sync --locked --all-extras` 同步自己的 `.venv`；缺少本地环境时用主检出的 Python 启动准备，测试仍在新建的本地环境里运行。同步保留启动解释器的 Python 版本，忽略外部 `VIRTUAL_ENV` 和 `UV_PROJECT_ENVIRONMENT`，拒绝工作树环境指向主检出。

主检出只按 ADR-0091 只读检查依赖；缺包或检查失败时以 `3` 退出，依赖变更由重启流程执行。找不到 uv、锁文件过期或同步失败也会停止测试。前端依赖与构建仍按上文安装。依赖、代码在测试中变化会使证据失效；完成安装和编辑后再启动最终验证。

本机全量验证与 `integrate` 共用 `full-suite.lock`，从取得代码和环境快照一直持有到记录写入完成。
锁忙时打印持有者并等待，最长 30 分钟；超时退出且不执行测试或合并。集成事务本身仍由
`integration.lock` 串行保护。部分域验证与 CI 分片不签发独立的本机全量记录。

锁旁的持有者信息用独立文件锁保护读写和清理；主锁仍负责验证与集成互斥。等锁线程关闭记录文件后，持有者才删除记录，避免 Windows 文件共享冲突。

测试入口退出码：`0` 验证有效，`1` 用例失败，`2` 参数或锁等待失败，`3` 环境预检失败，
`4` 验证期间代码或依赖变化、记录无效。Windows 托盘遇到 `4` 最多执行三轮完整验证，
只有取得有效记录才继续打包；用例失败直接停止。

正式入口会在创建测试分片前探测 PATH 中的外部工具。工具路径存在但当前权限不能启动时，
入口以一条环境结论退出，不把同一个 `CreateProcess` 权限错误散落到多个用例。整条
`scripts/test.ps1` 要在正常 PowerShell 权限下运行；权限不足时补权限再原样重跑，
不拆成单测也不跳过用例。

判失败的只有本次所选域真的会用到的工具，其余启动受限的工具只打印一行提示：受限环境里
ffmpeg 起不来是事实，但它不该挡住一次只改文档的 `checks`。域由选中的测试源码推出来。
确认本次无关时用 `PEACH_SKIP_PREFLIGHT=1` 整体跳过预检；分片子进程不重复预检。

## 记录的环境身份

记录只在「代码、环境、范围」三项都匹配时可复用，环境那一项由 `scripts/test_evidence.py`
的 `environment()` 算成一个摘要：解释器与已安装包、平台、`PEACH_*` 等环境变量、前端
`node_modules` 锁，以及 node／npm／git／ffmpeg／ffprobe／openssl 六个外部工具。

uv 只探针、不进指纹：它负责建环境，装出来的解释器与包已经逐个记在摘要里，而它自己由
winget 自动升级。把它的版本也算进去的话，升级当天全部记录一起失效，被验证的那套环境
却一个字节都没变。

工具身份取它**自报的版本**，不取 PATH 解析到的路径与文件字节。同一套 Git 安装在
PowerShell 里解析到 `Git\cmd\git.exe`、在 Git Bash 里解析到 `Git\mingw64\bin\git.exe`，
两个前端字节不同而版本和行为相同；按路径记身份会把记录绑在 shell 上：在一个 shell 里
跑出记录，换另一个 shell 跑 `integrate` 就报「缺少有效测试记录」，回到工作树跑 `auto`
又说「复用记录」，两句查的是两个键，代价是白跑一遍全量。

改 `environment()` 的算法本身时，主检出那份代码算不出新键，无法验证带着新算法的分支。
那一次的 `integrate` 用分支自己的脚本跑，并把仓库指到主检出。`--repo` 是顶层参数，
放在子命令前面，放后面会被 argparse 拒收：

```powershell
& .\.venv\Scripts\python.exe -X utf8 <工作树>\scripts\agent_worktree.py `
  --repo <主检出> integrate --branch <分支>
```
