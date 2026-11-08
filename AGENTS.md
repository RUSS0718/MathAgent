# 主观评测工程分支说明

本文件把《基于 Intern-S1 的数学智能体设计与推理创新》比赛方案中与主观评测有关的要求，转换为本分支的开发边界。比赛方案是评分依据；本文件才是本分支的执行说明。

理解版本状态、查找开发阶段 / 能力验收材料或规划下一版本时，先读 [文档索引](docs/README.md)。索引区分 accepted 设计、开发完成记录、能力证据和早期路线图；当前能力不能仅从旧 PRD 或 GAP 推断。

身份、恢复或交付绑定相关修改先读 [身份链导航](docs/engineering/identity-navigation.md)；运行快速、完整或发布检查先读 [工程门禁](docs/engineering/development-gates.md)。

## 评分目标

客观评测的答案正确性占 60%。本分支的新增工程模块默认关闭，不能改变根目录 `user_agent.ReasoningAgent` 的官方评测路径。主观评测占 40%，分为：

- **推理策略与系统设计（10 分）**：考察系统架构完整性、任务拆解、推理规划、过程校验或模块协同、策略与数学问题的匹配度，以及稳定性、可复现性和工程完成度。A 档为 8–10 分，B 档为 5–7 分，C 档为 0–4 分。
- **展示质量（20 分）**：考察 Demo 是否稳定运行且交互完整，视频与技术报告是否清晰完整，结果文件是否规范、可复现。A 档为 16–20 分，B 档为 10–15 分，C 档为 0–9 分。
- **创新性与可扩展性（10 分）**：考察数学智能体机制、推理范式、协作方式、验证机制、应用场景延展的创新价值，以及迁移和持续扩展潜力。A 档为 8–10 分，B 档为 5–7 分，C 档为 0–4 分。

总分相同先比较客观正确性，再比较推理策略与系统设计，最后比较创新性与可扩展性。系统仍需输出可解析的 JSON 结果；接口或格式错误会导致客观题无法判分。

## 本分支边界

1. 根目录 `user_agent.py`、`implementations/` 和其默认请求预算是官方评分骨架。没有经过独立验收的改动不得接入默认路径。
2. 主观评测功能必须通过显式入口运行；任何新路由、校验器、工具、记忆或协作模块都以关闭为默认值，且未启用时不增加官方模型调用。
3. `demo_server.py` 只服务本地展示，不会被 `user_agent.py` 导入。Demo 的 trace 只能包含脱敏的步骤、状态和摘要，不得包含凭证、完整 prompt、隐藏答案或个人信息。
4. 本分支不携带实验题集、答案库、运行 raw、废弃 solver 和旧脚本；脱敏且用于版本或能力追溯的记录保留在 `docs/`。运行产物写入被忽略的 `artifacts/<run_id>/`，不进入提交分支。
5. 根目录 `tests/test.md` 是用户保留的未跟踪文件：保持原样，不读取、不修改、不提交、不删除。
6. 任何声称“能力提升”的结论都必须有独立、可复现的评测证据；Demo 可运行或结构测试通过只能证明工程可达性。

## 验收最低线

- `user_agent.py` 可导入；`ReasoningAgent(client=...).solve(problem, metadata)` 返回带非空 `final_response` 的可 JSON 序列化字典。
- 默认官方路径的调用预算、输出边界和失败回退保持可追踪。
- `uv run python -m unittest discover -s tests -p "test_*.py"` 通过；若环境未安装 pytest，不以此为理由改变运行时依赖。
- `uv run python demo_server.py --help` 成功；本地 Demo 的 `/health` 和 `/solve` 合同有测试覆盖。

## 合并纪律

本分支的目标是工程化和创新性展示，不是用主观功能换取客观分数。合入 `RUSS0718/MathAgent` `main` 前必须单独审查官方路径差异、默认开关、调用/令牌预算、依赖安装和干净环境入口；没有这组证据时只保留在本分支。

## Agent skills

### Issue tracker

Issues and specs live in GitHub Issues at `RUSS0718/MathAgent`. See `docs/agents/issue-tracker.md`.

### Triage labels

Use the five canonical state labels `needs-triage`, `needs-info`, `ready-for-agent`, `ready-for-human`, and `wontfix`. See `docs/agents/triage-labels.md`.

### Domain docs

Single-context: read the root `GLOSSARY.md` and relevant records in `docs/adr/` when present. Add them when domain terms or consequential decisions need recording. See `docs/agents/domain.md`.

## Development workflow

产品实现前先确保 PRD、技术设计、任务合同与验收案例可审阅。对会影响设计、验收或交接的阶段，保留可审阅产物和退出条件；纯文档、诊断及小范围维护按任务范围处理，不为流程本身创建材料。

每个代码切片用失败测试或可执行验收案例确认目标，实施最小改动，运行聚焦检查与相关回归，审阅 diff。双轴审查集中在可独立验收的纵切或阶段退出时，修复后复查受影响部分；验收编号不等于独立审查或提交单位。每次提交保持一个逻辑变更，阶段最终检查按工程门禁执行。

新窗口先核对工作树、HEAD、未提交改动和任务依赖。材料未变化时复用交接中的已读结论及证据位置；身份、恢复、发布等专项材料按本次修改范围读取。交接必须强调继续使用当前选择的同一模型；无法确认具体型号或继承结果时如实说明，不猜测型号。

文档按职责维护：任务合同保存要求与退出条件，验收记录保存结果、源码 SHA、命令及证据位置，索引提供当前阶段与阅读入口。通用规则在 AGENTS 和工程门禁维护，任务文档引用规则；已有设计可与任务合同合并，不要求每个流程阶段另建文档。历史快照注明日期和适用源码，阶段推进后更新当前入口。

官方 baseline 保持字节稳定，除非发布决定明确授权。初始化约定见 `docs/engineering-bootstrap-plan.md`；baseline 与 sidecar 边界见 `BASELINE.json`、`docs/release-boundary.md` 和 `GAP.md`。

## 搜索与检查入口

搜索代码使用 `rg` 或 `rg --files`，排除 `.venv/`、`__pycache__/`、`.pytest_cache/`、`.ruff_cache/`、`artifacts/` 和构建产物；不要递归读取虚拟环境。检查命令见 [工程门禁](docs/engineering/development-gates.md)。

## 运行环境入口

Python 命令使用 `uv run`；Python、前端检查及长测试观察入口见 [工程门禁](docs/engineering/development-gates.md)。

## Git 分支与提交规范

创建或重命名分支、提交、合并或记录发布时，遵循[提交与分支规范](docs/engineering/commit-convention.md)；已有历史不主动重写。
