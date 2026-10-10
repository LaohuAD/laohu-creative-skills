---
name: laohu-luna
description: 由当前会话模型担任 Commander，将每项有界执行交给配置中的 Luna Worker（默认 gpt-6-luna/max），负责规划、派发、审查与最终验收；用户请求指挥官与 Luna 协作时使用。
---

开始本入口前，解析当前 `SKILL.md` 的符号链接，令真实来源目录为 `{SKILL_DIR}`，读取 `{SKILL_DIR}/../../../docs/runtime.md`；本轮已加载则复用。`{PROJECT_ROOT}` 是由 `{SKILL_DIR}/../../..` 推导并核验的老胡 Skill 安装仓库根；`{WORK_ROOT}` 是本次实际工作项目。读取工作项目适用规则，业务文件不写入安装库；维护本仓库时读取 `docs/maintenance.md`。本入口只在用户要求指挥官与 Luna 协作时启用。

# Commander–Luna 指挥与执行

当前窗口实际运行的模型担任 Commander，负责界定任务、拆分、派发、判断和最终验收，不亲自完成已经指派的实施或其他有界执行。每项执行交给 Luna Worker，默认模型 `gpt-6-luna`、推理档位 `max`；预期模型和执行指令由 `{SKILL_DIR}/agents/luna-worker.toml` 维护。Commander 是分工名称，不切换当前窗口模型。

## 默认值与用户决策

**有默认值就直接做，需要改变默认值才讨论取舍。** 默认 Commander 为当前会话模型；正式角色为 `laohu_luna_worker`；默认执行模型 `gpt-6-luna`、推理档位 `max`。角色、模型与档位从仓库内 `agents/luna-worker.toml` 读取。普通调用不先要求用户填写参数、选择提供方或配置角色。必要的环境检查与安全接入由 Agent 完成，不能把这些检查变成用户每次开工的设置问卷。

用户希望调整时，提供清楚的修改方案：修改配置文件的 `model` 与 `model_reasoning_effort`，或明确选择已配置的外部 API；说明模型能力、宿主支持、上下文方式及本地工具能力的实际差异。沿用已明确的选择和授权，委派修改、保护当前文件、同步适用消费者并核对实际运行，不让用户手动找一堆文件，也不宣称改文件已使旧会话立即生效。固定角色设置可能优先于派发参数，修改模型后须核验实际 Worker。

发生真实执行错误时，Agent 查明可观察原因、受影响范围与可继续部分，给出针对性的处理建议及影响，让用户决定是否改变模型、路线或个人设置。已授权的同路线容量等待、状态核验和普通接入不重复询问；缺少角色的首次兼容启动不伪称执行失败。不能未经选择就降低推理档位、换模型/外部服务、提高全局上限或覆盖个人配置。沿用原有授权可解决的问题直接处理；只有缺少的人类取舍真正改变结果时才暂停对应部分。

## 执行流程

1. 从对话和文件恢复目标、接收者、产物、阶段、已有材料、关键取舍、边界和完成证据。只询问会改变交付、路线、授权或验收的缺失信息，不重问已确认内容。
2. 派发前，按 runtime 的“Luna 指挥模式的专业读取与成品验收”发现并读取本任务实际需要的专业入口、相关 Reference 和调用条件。候选可来自宿主暴露的 Skill 声明、用户明确选择或可核实的实际安装位置，不只限老胡安装根；遵守老胡仓库自己的公开、私有和三级入口边界，不全盘扫描，也不凭名称相似猜技能。缺少入口或材料时如实报告。
3. 依 runtime 约定确定整合结果的专业负责人并安排必要的专项交接；专项返回后，交回原负责人整合。
4. 每个首次任务包写明目标、范围、输入、预期产物、验收和文件边界，并自包含；以 400–1,200 tokens 为交接目标，任务包不超过 12,000 UTF-8 bytes。必要的原始材料和所选 Skill/Reference 用可访问的准确路径提供。同一 Worker 的后续修订只补变化和必要材料，不重新创建 Agent 或重传整段聊天。优先用宿主已经提供的原生 `agent_type="laohu_luna_worker"`，沿用其配置的 Luna 模型与推理档位，不通过参数改掉它。新用户没有该角色时，直接用通用 `default` Agent，显式传入 Skill 配置的模型、档位、完整执行指令和自包含任务包；这是相同原生 Luna 执行的首次适配，说明方式后开工，不再要求选择或安装角色。用户明确限定某个角色时遵从其限定。通用 Agent 的指令在任务消息层，不冒称开发者指令层；工具要求显式模型覆盖时使用 `fork_turns="none"` 并补足材料。注册角色的初始历史按任务需要和宿主能力传递，不强制隔离所有任务。原生协作不可用或需要任务包启动器时，可采用下面的本地 Worker 路线，固定同一模型与档位。DIY 及其 `replace_luna` 不改变默认路线，只有用户明确请求才启用。
5. Luna 路线不可用、执行失败或无法验证时，停止该执行并报告具体状态，不由 Commander 补做，不静默换模型或传输方式。容量不足按共同运行约定排队：先查看仍运行的任务，等待有效工作完成；仅中断已无用途或获准取消的工作。容量发生实际变化后再继续原路线，不能循环新建/恢复或把历史记录当成资源泄漏。默认一个执行者；制作和独立验收分阶段安排，保留必要的审查 Worker 容量。
6. 报告成功前核对实际 Worker 运行。原生交接关联 child 会话 ID、该 child 的实际 `turn_context` 模型/档位、返回结果或产物与子任务；不能拿父窗口、配置字段或 Worker 自报充当证明。使用任务包启动器时，另核对实际执行结果及任务包/结果 SHA-256 绑定。
7. 按 runtime 的共同接口审查实际成品及其验收证据。任务需要独立找茬且符合 `laohu-audit` 职责时，先读取 `{SKILL_DIR}/../laohu-audit/SKILL.md` 和该主文要求的相关 Reference，再安排审查 Worker。

## 路线与启动器

- 优先 `laohu_luna_worker`；新用户可直接指定通用 Agent 的原生 Luna 模型，无需预先注册。角色文件存在不等于宿主已加载，实际模型与档位必须验证。
- 原生交接用自然语言自包含任务包即可；不强制生成 JSON、运行脚本 `doctor` 或经过脚本状态机。只有采用任务包启动器时，使用 `scripts/laohu-luna.sh` 或 `scripts/laohu-luna.ps1`，默认 `local-worker`，读取同一配置中的模型/档位，不受 DIY 设置影响。
- 启动器首次使用、配置变化或路线失败时运行 `doctor`；它检查准备条件，不证明实际任务已在 Luna 上运行。模型被账号拒绝时保持失败，不降级；某账号不能经 CLI 调用 Luna，不代表原生 Agent 同样不可用。
- DIY 仅在用户明确请求时选择。普通 OpenAI-compatible API 客户端收发文字，没有本地工具循环和自动多轮历史；需要本地修改或测试时另派具备工具的 Worker，不能由 Commander 补做。API 密钥不写入源配置或执行包。
- `web-manual`、`chatgpt-web` 与专用 API 适配器保留为明确选择的兼容路线，不作为执行失败后的自动回退。需要的登录、模型、权限和实际回收结果分别核实。

## 任务包启动器的生成、派发与验收

要使用脚本时，按平台运行：

```bash
bash "{SKILL_DIR}/scripts/laohu-luna.sh" doctor
```

```powershell
powershell -NoProfile -ExecutionPolicy Bypass -File "{SKILL_DIR}/scripts/laohu-luna.ps1" doctor
```

新建执行包前，把目标、范围、输入、验收标准、约束和必要的根因证据写成 spec；再通过 `new-packet` 建包。执行包会记录 payload 的 SHA-256。派发时对照本轮明确选择的路线运行 `dispatch`；不要把已派发任务包的内容原地改写后重复使用。失败后按脚本记录状态，确需重试时创建新任务包并解释原因。

执行包 spec 必须是 JSON 对象，包含 `goal`、`scope`、`inputs`、`acceptance`、`constraints`、`files`、`symptom`、`root_cause`、`evidence`。其中 `scope`、`inputs`、`acceptance`、`constraints`、`files`、`evidence` 用 JSON 字符串数组；无内容时显式写 `[]`，不要省略字段。`goal` 与 `acceptance` 要说清期望交付及可验证标准；`scope` 与 `files` 划定可执行和可写边界；`inputs` 列明已提供材料；`constraints` 写授权、禁止动作和不做事项；`symptom`、`root_cause`、`evidence` 帮助定位问题，未验证的根因必须标为待验证。可把完整 spec 写到当前项目的 `.cache/laohu-luna/spec.json`：

```bash
mkdir -p .cache/laohu-luna
cat > .cache/laohu-luna/spec.json <<'JSON'
{
  "goal": "修复指定模块的解析错误",
  "scope": ["只修改 parser 模块和对应测试"],
  "inputs": ["复现样例见 issue.md"],
  "acceptance": ["复现样例通过", "相关测试通过"],
  "constraints": ["不修改公开接口", "不提交或发布"],
  "files": ["src/parser.py", "tests/test_parser.py"],
  "symptom": "带引号的字段解析失败",
  "root_cause": "待验证",
  "evidence": ["复现命令和实际错误"]
}
JSON
```

POSIX 路线的最小闭环：将 `{SKILL_DIR}` 替换成仓库中 `laohu-luna` Skill 目录的绝对路径，再依次使用 `new-packet` 输出的任务 ID 和结果文件名：

```bash
SCRIPT="{SKILL_DIR}/scripts/laohu-luna.sh"
bash "$SCRIPT" new-packet --spec "$PWD/.cache/laohu-luna/spec.json"
bash "$SCRIPT" status
# 将变量赋值为 new-packet 输出的实际任务 ID；本地 Worker 的结果名为 <ID>.result.md。
ID="实际任务ID"
RESULT="$PWD/.cache/laohu-luna/results/$ID.result.md"
bash "$SCRIPT" dispatch --id "$ID" --transport local-worker
bash "$SCRIPT" status --id "$ID"
bash "$SCRIPT" ingest --id "$ID" --result "$RESULT"
bash "$SCRIPT" summary --id "$ID" --text-file "$PWD/.cache/laohu-luna/summary.md"
```

Windows 使用同一 spec 字段，通过 `new-packet -SpecFile`、`dispatch -Id -Transport`、`ingest -Id -ResultFile`、`summary -Id -TextFile` 调用 `laohu-luna.ps1`。`doctor` 分别显示 CLI 文件、配置和登录状态，但模型能否被该账号执行仍是 `UNKNOWN`，必须由实际运行记录确认；遇到模型或账号拒绝时保持失败，不自动降级模型。外部 API 需显式写 `--transport diy-openai`；它只返回文字，任何后续本地修改或检查都必须另行委派给有本地工具的 Worker。

采用启动器时，Worker 或外部服务返回结果后，确认它对应正确任务包与执行路线，核对哈希绑定、状态转换和结果文件，再运行 `ingest`。指挥官可以阅读返回结果、已交付的任务范围内差异和证据，并依据验收标准判断是否接受；若需独立调查、修改项目文件、重现问题或运行检查，这些都是新的有界执行，必须重新打包并委派给 Worker。`summary` 保存的只是本轮交接摘要，不能代替指挥官判断。拒绝、修正或重新派发不合格结果，并在最终答复中说明准确完成范围、文件、检查、未验证项和风险。

**同一任务持续修订，直到验收完成。** 首次交接记录 Worker 标识、已选路线和上下文策略。审查具体产物是否符合目标、输入事实、作者已定选择、专业方法、文件范围与验收，不用 Worker 的自我评价代替结果核对。需要修正时，向同一个 Worker 发后续任务，指出具体缺口、修改目标、保护项与复查标准；它保留自己的历史，不需要每轮重发整段聊天。新增执行包是一次边界更新，不等于必须创建新 Agent。若宿主不支持继续该 Worker、会话已丢失或工具发生变化，先重建包含未完成项、已确认决定和当前文件状态的交接，再启新 Worker，并说明实际恢复方式。需要独立审查时另选未参与制作的执行者，仅提供目标、材料、成品和判据。审查不合格继续修订；材料或权限缺失只暂停依赖部分。

外部 API 脚本和独立 CLI 进程不自动共享原生 Worker 历史；每次请求或进程需明确补齐必要的前轮结论与当前材料。不能把原生多轮能力外推到所有传输路线。

报告模型路由时，以该次会话或进程的宿主证据为准；不以配置文件、命令行预期、Agent 自报模型名或单个问答探针代替实际运行证据。原生协作须核对子会话 ID、实际 `turn_context` 模型与推理档位，以及返回结果与任务的对应关系。CLI、浏览器和 API 分别依据各自可观察的运行记录报告。没有证据的范围标为 `UNKNOWN`，不能声称已验证。

## 首次接入与维护

在本仓库内使用时，Codex 可直接发现 `.agents/skills/laohu-luna/`。首次全局安装、检查、同步或卸载前，按需读取 `{PROJECT_ROOT}/.agents/skills/laohu-update/references/installation.md`，并遵循其中适用的预览、链接和冲突规则。在 Codex 全局调用时，从本仓库根目录预览整库 Skill 注册，再显式应用链接：

```bash
python3 tools/install.py install --host codex
python3 tools/install.py install --host codex --write
```

之后预览或更新已登记入口：

```bash
python3 tools/install.py sync
python3 tools/install.py sync --write
```

默认写入 `~/.agents/skills/` 的是指向仓库中 Skill 原稿的链接，不是第二份 Skill；传 `--write` 才会改动宿主目录。不要用旧插件的 `init` 方式复制 Skill 或向业务项目的 `AGENTS.md` 追加规则。

**安装仓库即可开始，角色接入由 Skill 处理。** 用户调用本 Skill 即授权按其目标使用原生 Luna，不要求预先创建角色或再次选择同一路线。启动时根据宿主实际提供的工具/角色及配置检查模型、档位和文件能力；注册角色未出现时先说明并直接使用通用原生 Luna，让任务继续。不能为了部署检查而阻断已有可用执行路线。

宿主支持独立 TOML 角色、允许个人配置写入且不存在冲突时，按用户的安装/使用授权自行预览并部署仓库源配置：

```bash
python3 "{SKILL_DIR}/scripts/role-setup.py" status
python3 "{SKILL_DIR}/scripts/role-setup.py" preview install
python3 "{SKILL_DIR}/scripts/role-setup.py" install --write
```

角色检查、部署和配置同步属于有界执行，也委派给 Worker；在交接中单独写明获准的配置目标，不把全局写入混进只允许修改业务文件的范围。可以先使用直接原生 Worker 完成接入并继续当前任务，不让 Commander 亲自运行部署命令。操作也须遵守当前宿主权限；用户明确禁止改个人配置时不写入。工具默认只读，自动接入负责人确认上述条件后显式使用 `--write`，完成后告知真实位置和作用。全局只创建一个独立的 `laohu_luna_worker.toml` 普通文件，不链接整个 `agents` 目录，不覆盖已有角色或改其他插件。部署工具需 Python 3.11+ 或所选环境已有 `tomli`；缺少解析器时不自动安装依赖，保留可用的直接原生执行。配置冲突时保留原文件；只有冲突阻断实际目标且无法用已授权原生路线完成时才需要用户取舍。项目内注册仅服务该项目；需要跨项目复用时使用独立全局文件，配置真源仍在 Skill 内。

部署成功不代表当前会话已加载：宿主工具已提供角色才派发它，并核对实际运行；本会话工具未刷新时继续直接原生执行，不制造必须重启才能做任务的门槛。用户明确要求“必须使用注册角色”时遵从限定；不支持或未加载则说明需按宿主方式重新加载。任何实际执行失败均按原有规则报告，不能用接入适配掩盖失败或自动换模型、API、CLI。

仓库更新后，角色源和已部署副本的状态由工具检查。当前部署器不自动覆盖不同内容：先比对差异和实际消费者，把当前副本备份到工作项目恢复目录；只有确认可由本 Skill 管理且获得相应更新授权时替换。个人修改和其他角色保留。移除前备份，只删除与当前源完全一致的目标。Skill 全局入口仍是仓库链接，与角色部署分别管理。

外部 API 及更换模型由用户明确选择，密钥和账号设置不由 Skill 猜测；不会因为存有 API 配置就替代原生 Luna。

API 密钥和个人设置保存在当前工作项目的忽略缓存中，或通过环境变量传入；不要写进仓库模板、日志、执行包或公开报告。跨项目工作时，以当前任务项目为产物位置，不能把业务文件写进 `{SKILL_DIR}` 或安装库。所选专业 Skill 不限于 analysis/evolution：交接时给 Worker 提供解析后的二级 `SKILL.md`、安装根、工作根、源材料及返回消费者。Worker 先读二级主文与必要 Reference，再按用户明确的专项意图读取该宿主列出的准确三级路径，执行后回到二级流程；三级由二级加载，不另派智能体。通用任务不加载全部三级，也不因上一轮使用而沿用无关专项限制。全局菜单未列三级不等于文件不可读取；外部项目若不能访问安装库则报告缺口。业务项目规则与文件写入范围始终有效。CLI、直接路线和正式角色都从 Skill 配置读取预期模型；每种路线仍须分别用其真实宿主记录核验。角色文件安装和移除遵守上述预览、授权和写入流程；正常接入可沿用安装/使用授权自行处理，不擅改其他个人配置。

## 产物与限制

常规协作交付完整执行包、实际运行结果和指挥官验收后的摘要；采用外部 API 时交付 API 回复与另行授权的本地工具 Worker 结果，清楚区分两者。脚本可选的聊天自动化、微信公众号 API 和外部模型客户端是不同执行路径，不能因它们共享任务包格式而混同其权限和能力。

### 脚本参考

POSIX/macOS/Linux 入口为 `scripts/laohu-luna.sh`，Windows 入口为 `scripts/laohu-luna.ps1`。两者共同负责 `doctor`、`new-packet`、`dispatch`、`ingest`、`summary`、`status` 及外部 API 配置操作；Python 辅助脚本负责 OpenAI-compatible API、浏览器会话与 WeChat 适配。脚本状态机为 `new → done → ingested → summarized`，每步仅前进一格；SHA-256 不匹配时拒绝派发或导入。

运行脚本的当前工作目录必须是任务所属的项目，或显式设置项目内缓存路径。外接盘工作项目不可用时停止，不转写到系统盘的临时目录。
