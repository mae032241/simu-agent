# 当前架构：薄 H/W/A/E 控制层

简体中文 | [English](ARCHITECTURE.md)

新实例由 `scid-research` 管理，实验工具为 `scid-experiment`。没有 LLM Root、MCP 调度服务或后台 Root daemon。
核心提供薄 CLI 与实例 UI；旧 CLI/MCP/UI、Root 宿主、平台配置生成与 legacy systemd 部署已退役。

`research_config.py` 是 TOML、CLI 与宿主入口共同的准备、默认值和校验路径。新实例冻结实际生效设置；修改声明不更新已有实例。`backends.py` 将 Codex 与显式 protocol 输运隔开，不接管科学判断、预算或执行授权。protocol 权限为 launcher 提示，不证明隔离；不支持原生续接和完整作者证明，不能取得正式独审。开启子 Agent 也不证明作者或用量完整。具体字段与限制见[配置与后端参考](RESEARCH_CONFIGURATION.md)。

冻结的权限摘要分别记录请求值、实际策略、实施方式与限制；标准 Codex danger-full-access 不强制离线，read-only 不因网络请求启用联网，protocol/自定义 launcher 仅作权限提示，实际访问未知。

CLI 是应用核心，网页复用相同公共控制和读取逻辑。`control_operations.py` 持久记录 detached 推进及科学预算修订；独立控制进程使用原写锁，不依赖网页进程常驻。暂停阻止下一节点，已接受工作按原限制完成。预算修订在安全边界应用，不重置消费或未知用量；unknown 原调用须核对，不自动重发。

`user_guidance.py` 将全局/角色建议绑定到下一匹配新任务或后续研究。待应用项可按 revision 修改/撤销，已应用任务输入不可改写，后续研究撤销另留未来生效回执。建议可不采纳；显式目标变更保留原目标记录，并声明生效节点，不授执行权限或科学资格。

## 责任与数据流

```text
操作者的目标、输入、配置、有限预算
  -> CLI prepare：冻结实例设置
  -> controller：原实例写锁、预算、暂停、角色路由
  -> native：独立 H / W / A / E 原生线程
  -> 科学 JSON 与精确成果封存
  -> A 的科学去向 -> controller

W -> scid-experiment -> 冻结执行接口 -> local / 领域 adapter
                              -> 原调用 query / cancel / collect
CLI serve-ui -> 同一实例的只读视图与控制命令
CLI archive / checkpoint -> 原件核验与限定恢复
```

H 负责机制与假设；W 负责有界实验设计、实现与观察；A 负责贡献、证据缺口、后继方向和交付选择；E 负责所请求的证据工作。
控制层拥有身份、冻结绑定、预算、资格、权限和机械发布，不制造科学结论，也不在提示词中
给 Worker 增加哈希计算、比对、校验或哈希清单工作。Worker 写普通科学文件；控制程序
自动计算并核验精确绑定，在宿主私有空间保留机械记录。


本地结果指标仍须有不同的非空名称和明确有限数值。`unit`、`evaluation_key`、`direction`
与标签是可选科学说明，不强制优化方向枚举或科学文本长度。显式候选须绑定唯一已声明且保留
的精确成果；指标缺失或无法关联时保持 unknown，不改选其他指标或推断方向。坏指标、成果声明
或无法存入严格 JSON 的说明按字段或条目诊断，保留其他有效结果和有精确成果绑定的候选身份。`result.json`
原始字节不改写；紧凑预览与被省略字段的诊断链接该留存原件。

启用 H search 承诺时，`prepare --candidate-extra-slots N` 冻结 W 提名的额外名额，默认 2。
W 在既有科学返回的 `candidate_nominations` 中，对每个未 waived 的真实 H 机制声明一个代表
或明确缺口，包括 deferred 和 screened；另可提名至多 N 个不重复的额外备选。
每个代表须定位精确已登记候选并说明保留及机制归属理由；同模型覆盖多个机制须逐项解释。
当前调用的候选用 `{call_id, artifact}` 定位，历史候选沿用科学引用。控制只检查身份、
声明覆盖、重复和数量，不从调用绑定推断模型的机制，也不排序或判断科学真伪。
没有可用模型应明确缺口，不阻 partial 或 FINAL；只有 A 明确 waived 并给出科学否定或
不可行理由才免除机制覆盖，暂时相对低分应保留暂缓路线。

最近封存 W 的分类提名构成默认比较预览，独立分页保留完整提名、理由及原结论入口。
原候选池、实验和精确材料沿用完整分页及交付目录，池的数量不受提名名额限制。
A 可按需读取并用既有推荐与选择说明直接选择池内任一模型，不改写封存 W 提名，
也不需要为调入已有模型重新实验或登记。无 H search 承诺的任务不制造机制覆盖。

科学机制及处置列表没有固定四项或 128 个机制容量。已配置的初始调用机会、精确额外授权、
已接受调用消费、有限执行预算及未知原调用核对仍约束执行。分页索引保留全部机制和原科学文本，
默认导航视图继续有界。

`screened` 表示 A 已评价精确 W 证据，不排除以后继续深挖；`deferred` 暂缓并保留未决路线；
`waived` 才是 A 的明确科学排除。A 须针对原目标与约束，用证据支持每个排除的否定或不可行
理由；暂时相对落后或缺证据应说明暂缓，不能直接视为科学否定。H 先比较可信的竞争机制再
说明集中理由，单机制范围也由 H 解释；参数试验次数本身不证明不同机制均有判别证据。
控制不裁判理由的科学充分性。

机制索引提供已采纳 A 处置理由的有界预览，并链接完整科学 JSON 原件；原件不受导航页大小
上限省略。同状态重述或遗漏不替换原理由与来源；H 修订会清除当前处置，历史原件仍保留。
所有启用 search 的实例默认向 H/A 展示完整组合：实际已接受调用数、剩余初始/额外机会、
已完成独立 W→A 投入及未服务完整周期。调用数和周期数是活动事实，不是科学覆盖、价值排序
或每机制资源成本。稳定身份顺序只作导航；局部 improve/repair/validate 不抹去全局视野，
科学说明和 H 修订也不清零投入。所有未 waived 路线（包括 screened）进入未服务周期观察。
`search_policy.initial_calls` 配置初始受管调用机会；显式组合周期只控制提醒，不要求额外
portfolio_review 表单，不强制换路线，不阻止科学封存或 FINAL。A 在既有 scientific_result /
route_reason 中说明比较、集中、暂缓和排除依据，控制不判科学充分性。

广度预算判断读取普通工作可用量与运行时 `work/budget-status.json`。当前 protected FINAL
只按 provider 已报告消费计算 token 余额，未知账单保持未知，不估算收费或扣旧收口预留；
真实执行未知仍须按原调用核对。旧预算内收口实例保留原冻结预留。调用机会不预留实际资源，也不保证覆盖；昂贵调用应使用已有执行配置
和 W 阶段目标约束，不引入自动广度比例、最低机制数或新的执行权限。

H 只声明需要变更的 commitment；遗漏保留原承诺及已采纳 A 理由。repair 按稳定机制 ref
绑定唯一精确直接 W 观测，或通过既有 `implementation_selection` 选定的原 accepted 输入。
多个可能观测须精确选定；相同输出字节、label 或最近对象不提供来源身份。去重归档路径
不能证明逻辑输入身份，此类输出不能用于 repair 来源消歧。旧 W、call、accepted
及终态原件仍按自己的旧 H seal 校验，当前 H/A 的新授权另行冻结。进程已知成功不排除科学上
需要修复；unknown、原件缺失或改变、来源模糊及修复次数耗尽仍阻断，并在作者控制回执中提前
诊断。旧 screening 资格不继承，机会及总消费不退款。H 科学范围未变时，A 可用 `continue_w`
加显式局部 focus 请求审查后的下一有限 W stage；原 stage 消费继续累计。修订 H 用于科学承诺
改变，不能重置预算。

每个任务冻结其配置真正消费的辅助字段；未消费字段不进入原生回答的必填合同，额外科学内容
仍保留在封存原文。已启用的可选字段形状无法读取时局部诊断，不推断 progress 或作用域。
W 显式非空但形状损坏的 finding 作为 partial 交 A，不产生 screened 证据；缺失或合法但漏覆盖
的 finding 仍执行现有机制覆盖检查。真实 action、FINAL 路由、输入选择、独立资格和执行权限
继续显式校验。输入选择的 null 保留、`[]` 清空、有效列表替换；未解析列表不部分应用或静默继承。
已登记候选与其精确封存实现，可在 call/output/material 绑定一致时用同一可读引用选择；
相同字节而不同来源不合并身份，任意实现不自动成为候选。

新 job 将适配器可选的 `effect_scope` 声明冻结为公开 `configured_delivery`；声明须为
非空公开文本，不设固定长度上限。custom 未声明时范围为 `unknown`，不按启动器名称猜测。
内置目录适配器只复制并确认已留存的声明文件，不训练、不执行任务原生提交或科学审计；
此描述不授予权限或资格。W 须在临时材料消失前，将原任务实际需要的成果与原生回执保存到
既有声明输出。A 对照这些成果、真实适配器范围与任务要求说明缺口，仍可交付当前最佳的
部分成果，包括 FINAL；目标覆盖不会新增完成度硬门槛。

`exp` 是使用普通 `submit.json`/response 单槽的薄提交与等待工具。local 模式 W 的科学
视图由既有原生宿主在本次 native attempt 生命周期内处理提交并自动写回响应；external
模式仍由声明的 launcher 负责。两条路径均不引入额外 Agent、daemon、UDS 或 FIFO。

默认本地命令后端解析所选 Codex 安装的原生二进制，使用其 sandbox 和受限的科学子进程
文件视图。已接受的目录快照只读映回原科学路径，`artifacts/` 独立可写；单文件调用将
封存脚本映回其科学源码路径。后端只获得运行时文件、科学工作区及 task-native 权限配置，
不获得原生认证、provider 配置、控制原件或提交槽。原生 Worker 与后端遵守同一受支持的
legacy `workspace-write` 声明，包括网络权限和临时目录排除，并按各自工作目录、`TMPDIR`
和命名空间等义解释。原生 Worker 保留 `--sandbox workspace-write` 及捕获的 legacy
配置覆盖；只有后端 sandbox 使用表达同一声明的内部权限 profile。需要 Linux、
`bwrap` 及可解析的 Codex 原生二进制。named/default permissions、选定配置 profile、
managed policy、额外可写根以及无法忠实投影后端权限的自定义 launcher，会对受管启动
明确返回不支持，不为执行而替换其原生权限。内部权限 profile 不增加操作者配置项。
这些文件视图不构成防同用户恶意进程的隔离，也不对泛原生执行提供统一隔离保证。

控制侧保留完整绑定索引、回执和逐文件省略绑定；默认科学视图提供人可读引用、观察与限制。
新视图明确标注为投影，源代码、用户原件和科学正文保留原内容。独立操作侧导出工具
`scripts/acceptance/worker_evidence_view.py` 核验显式绑定的原索引及已索引字节，生成分开的
`control/` 与 `science/` 目录。Worker 只获得 `science/`，输出父目录及 `control/` 留在控制侧。

`science/index.json` 默认给出简短省略摘要，包含 `details_ref` 和 `when_to_open`。
当某个候选或实验的材料覆盖会影响判断时，可按引用读取有界分页中的人可读材料名、类别、
范围与原因；详情不作为普通证据的整份清单。详情是可用性信息，不等于被省略原件；未提供
原件或安全读取路径时标注 `not_available_in_this_view`。缺失材料如何影响科学判断由 Worker 决定。

默认省略元数据整体不超过编码后 JSON 的 8 KiB；多份清单通过 `omissions_next` 继续读取。
详情页最多 12 项且最终 JSON 字节不超过 16 KiB，导航与文本转义均计入。长科学字符串仍为
字符串预览，并列提供 `*_truncated` 与 `*_details_ref`；按链接依次拼接 `{text, next}` 页中
解码后的 `text` 可精确还原全文，末页不含 `next`。短字符串保留原形状。这些限制只针对
省略部分，不针对整个证据索引；文本详情入口也不等于被省略原件的读取入口。

## 实现归属

| 责任 | 唯一实现范围 |
| --- | --- |
| 实例准备、路由与暂停 | `research_loop/controller.py`、`runtime.py`、`instance_control.py` |
| 统一配置与后端 | `research_config.py`、`backends.py` |
| 后台操作与用户方向 | `control_operations.py`、`user_guidance.py` |
| 原生执行、原线程续接与计量 | `native.py`、`execution.py`、`continuation.py` |
| 科学合同、原文与成果 | `contracts.py`、`semantic.py`、`instance_science.py` |
| 候选比较与交付 | `selection.py`、`delivery.py`、`worker_delivery.py` |
| 执行注册与原调用恢复 | `experiments.py`、`managed_wait.py`、`local_experiments.py`；领域插件提供 adapter |
| 本地 W 提交生命周期与科学子进程视图 | `native.py`、`worker_execution_bridge.py`、`native_execution.py` |
| 来源、正式独审和执行批准 | `qualification.py`、`formal_review.py`、`execution_inputs.py`、`execution_authority.py` |
| 预算与累计资源 | `budget.py` 的原 control ledger |
| 实例 UI | `instance_ui.py`、`instance_render.py`；不建立第二份状态 |
| 归档与同宿主冷恢复 | `instance_archive.py`、`instance_owner.py`、共享 `archive_io.py` |

上述文件均位于 `src/scidiscovery/research_loop/`，另有说明者除外。
`scidiscovery.execution_interfaces` 发现执行接口，薄实例冻结精确选择及实现身份。
保留的 Operation 编译器、插件声明、共享 schema、抽取的回调及独立存储原语不是旧 MCP 服务入口。
`artifact_agent/service` 旧 Run/SQL 宿主及运行辅助模块已删除；存储库保留不表示薄链依赖它作为宿主。
不按目录名删除 adapter、来源规则或存储校验。Operation ABI 以 `operations/spec.py` 为准，当前为 26；插件接口见[API](PLUGIN_RUNTIME_API.md)。

## 不可退化的边界

- 科学作者负责比较和选择候选。控制按首次观察顺序保留全部候选，包括同分和缺少指标者。
  紧凑预览只作机械省略并链接完整原件，不裁剪交付目录。选择策略版本 2 精确为
  `{"version":2}`，目录不启动领域调用。A 交付须明确命名目录成员，在 `scientific_result`
  说明选择依据。`candidate_comparison` 是可选科学说明，其行、`keep`、理由和证据步骤格式
  不授予或阻挡交付；真实 audit/deliver 仍要求精确可用候选、资格与执行权限。
  null 不授权交付。协议 23 拒绝旧冻结协议，不迁移或改写其原件。
- 一个实例只有一个推进写者；只读页面不调模型，不重建第二份预算或科研状态。
- 科学原文、成果、配置和原调用均按精确身份冻结；修订不能继承旧对象的批准或资格。
- 来源未知保持 unknown；正式独审排除精确对象的全部已知作者与参与者，普通 A 不自动成为正式审查。
- 科学判断、正式资格与执行批准分别解释；聊天或手写决定文件不构成人工批准。
- 未知外部提交只核对原调用，不退款、不重发；恢复不重置额度、不生成另一个 owner。
- UI 转义作者内容；附件按精确封存成员读取，HTML/SVG 仍下载，不执行。
- 当前信任 Worker 及宿主同权限进程，属于软控制边界，不主张防恶意进程隔离。

授权读取只核对不可变声明、身份、精确对象、范围及已声明的期限或撤销状态，不遍历执行结果或重放科学结论。
真实效果入口显式检查科学资格与原件完整性，并独立检查当前预算、暂停、活动或未知执行的准入条件。
结果损坏或缺失不抹去已接受意图和消费，也不妨碍查看或撤销授权；它会阻止新效果，或使相关终态和计量事实保持未核实。
已接受调用的 collect/cancel 保留原权限与调用身份，不变成新的提交授权，也不重发原调用，仍受原调用或显式有限维护窗口约束。

普通 A 任务要求逐项对照原目标和授权范围，以可定位观察及实验条件支撑关键主张，区分
测量、推断和假设、目标指标与代理及敏感性检查。A 按同一目标准则比较相关候选，说明
冲突证据、不确定性和缺失输入。流程结束、审计资格、预算耗尽、`finish` 和交付均不证明
未测量的目标已经完成；停止时 A 须报告未满足的目标。

A 明确给出 `candidate_recommendation` 时（包括 FINAL），须填写
`selection_explanation`：当前 `criteria` 与 `criteria_change.status`
（`unchanged` 或 `revised`）。修订时须声明 `prior_criteria`、`changes`、
解释原因且可定位的 `evidence` 和 `accepted_tradeoffs`；未修订时这些详情为 null。
A 须对照先前 H/W 设计及报告中的比较条件、门槛与回退规则；放宽这些规则即为修订，
即使当前报告已经采用新规则，也不能因此称为未变。
首次选择可如实说明没有前序准则；规划阶段没有候选推荐时可用 null。
框架只检查声明完整性，不判断科学真伪、充分性或候选排序。缺失说明在封存前通过冻结的
output-repair 策略退回同一 A 补填。FINAL 补填保留同一任务、session、最终返回授权、
累计消耗、有限次数及原单次时长；共享余额耗尽不撤销该次完成或其原授权交付。
它不授权新实验、新科学节点或重试未知执行。

标准单命令 `codex` 的 CLI prepare 默认冻结最多两次仅输出补填，在私有策略中绑定原
native home，保留配置、认证及权限来源；冻结绝对 launcher 调用路径和目标文件，
不替换符号链接调用语义。未提供节点策略时，各角色软目标引用原全局上限，不预扣额度。
显式策略优先且可关闭默认补填；自定义 launcher 和直接 controller API 调用仍须显式策略。
该默认值不授权失败任务、科学工作修复、fragment 或执行唤醒续接。

新 `prepare` 冻结 `final_a_completion_policy` version 1。普通状态检查剩余共享额度能否启动下一动作；该模式不为 protected FINAL 预扣共享 token、时间或步数，也不在启动时预付整个节点 token 目标。已报告 token 余额为正即通过普通 token 启动检查，仍须满足原有限时间、步数、完整性与执行门槛。H/W/A/E 单节点 token 目标统一为 soft，达线提示收口，不仅因达线拒绝新受管实验或强制转 A，原节点可以完成原结果；author closeout 的 token permit 同样为软目标，有限时间仍强制执行。协议 23 仅接受 soft 节点设置；旧协议只读，不静默改写冻结 hard 设置。不能启动便在现有控制账本进入持久 FINAL。每个 FINAL 周期通过 `final_a_return` 只接受一个精确原始 A，基于已有已接受 W 给结论、明确选择，并说明未满足目标与缺失输入。共享 token、总时间或步数预算不足、为零或超额均不否决这次 A；有原件与交付权限时由 host 执行其原授权提交和同操作确认，输出真实结果。缺少 W、原件、权限或未核对原执行时明确未提交，不制造科学结果。未配置可选节点预算时，原冻结全局 token/时间设置提供最终调用的参考目标与有限单次时长。

provider 已报告实际用量、cached input、时间及步数全部保留；未知账单继续标注未知，不估算扣费，原上限不改、不退款；`final_overrun` 单列 token 超额。同一 FINAL 周期不派发新的 W/E、独立科学审查、纠正节点或另一轮 A，原 host 提交内必要机械资格检查仍保留。
冻结的 output-repair 策略仅可续接同一最终 A 任务补全输出，保留原授权、累计用量、
有限次数及原调用时长；它不授权重试未知执行。

这次精确最终 A 的原生完成与账单覆盖分别判断。原 `turn.completed` 事件、退出码 0、
原进程组已确认清理及科学输出完整时，即使用量缺失或无法与实时计数对齐，仍可封存。
已观测下界和未知账单分别保留，不补造零用量或完整计费覆盖。仅计费未知也不阻挡该 A
明确授权的原 submit 和同操作 confirm；缺少完成事件、非零退出、清理未知或外部效果
未核对仍保持原未决边界，不授权替代 A 或重放。

用户之后明确提高阈值且足以启动原待执行 normal 动作时，下一次 run 从 FINAL 前保存的逻辑路由恢复。`budget-amend` 本身只记账，不启动模型。恢复使用单调递增的新物理编号，所有旧最终 A、交付与消费不变；运行中的原最终 A 先收集，未知外部效果须按原调用核对。最新修订降低阈值或提高后仍不足，不恢复、不重复 A；以后再次预算不足进入新周期，各周期一个最终 A。主动 closeout 没有待恢复路由时保持终态。缺少冻结策略的历史实例保留原行为。

后续只可使用原决策的有限 `submit` 和同操作 `confirm`。即使共享总时间已经超出，
原 A 单次调用、清理和每次交付动作仍保留已配置的有限时间上限。
资格、授权、精确原件核对、RSS 和取消仍有效。未知外部提交只核对原调用，绝不重新提交。
原生执行没有逐 request 准入 hook；此策略不保证进程、清理或传输故障后仍能产出报告或提交成功。

## 声明来源与审查

资格消费精确冻结原件，不按名字、相同字节或最近对象猜测来源。受管执行可通过
冻结能力声明输入来源；自包含 TCAD V2 package 必须匹配准备归档和原 reviewed
producer，编译 V3 输入保持原 compiler 链。明确不完整的声明不能回退为更广的来源主张。
可选 observer 须另行启用冻结来源合同，并提供绑定精确 observation 的来源视图；
展示 coverage 本身不授予资格。真实 producer 贡献即使未被选为 implementation 也进入
作者集合；普通 parent 链不自动生成作者关系。

普通探索不要求固定的正式审查阶段。所请求的审查须绑定精确对象与经核验的贡献者；
普通 A 解释不构成独立审查。来源限制沿冻结输入传播，未知来源保持 unknown。
这些核验仅覆盖框架声明范围，不证明任意 native 外读封闭或科学正确。

## 扩展规则

领域算法、科学 schema 和执行 adapter 归插件。核心按冻结的声明能力路由，不按领域
或插件名称分支决定科学行为。schema 结构、声明的科学语义与 validator 必须一致；
工程故障不能伪装成科学拒绝或科学重试理由。恢复保留原限制和失败证据。
只读视图与 UI 呈现同一封存科学字节，不改写科学内容。
CLI result/materials/artifact 与网页通过同一精确原件 API 读取，下载不覆盖已有目标；网页配置、实例选择、预算排队与用户方向复用公共接口，只打开明确选择的实例。

## 支持与资格

本地受管实验、候选交付、实例 UI、声明来源、执行 gate、原调用维护与同宿主原路径冷 checkpoint 已实现。
`/results?after=N` 分页显示封存节点，`/results/<step>` 显示精确结果；候选事实展示来自该节点输入时冻结的摘要。
普通只读包不能自动恢复为可推进实例；跨宿主、anchor 丢失和任意原生外读不在保证范围。
源码/HTTP/合成进程检查不替代真实浏览器、Codex 原线程、TCAD solver 或真实掉电资格。
旧入口退役不授予新链这些资格，也不自动操作已有主机服务、数据库或外部作业。

TCAD 专项提升资格所需证据见[资格状态](TCAD_QUALIFICATION_STATUS.zh-CN.md)。

使用方法见[CLI 指南](ROOTLESS_CLI.zh-CN.md)，部署见[安装](INSTALL.zh-CN.md)，验证口径见[发布](RELEASE.zh-CN.md)。
