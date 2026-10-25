# 本地智能体平台模拟与验收

此环境已接通：页面选择 → 目录接口 → 创建任务 → 队列/预约调度 → 对端实例与对话 → 现有评估器 → 数据库存储 → 页面结果。

智能体回答是确定性的本地模拟；任务、运行、评分和 Trace 使用 AgentGate 现有真实流程。本服务不校验 Token，不需要行内账号或模型服务。

## 启动与停止

在工程根目录运行：

```sh
.venv/bin/python script/agent-platform-mock/run.py
```

前提：已有工程 `.venv`、`frontend/node_modules`，系统已安装 `redis-server`。不会安装新软件，也不会读取项目 `.env` 文件。

启动后访问 <http://127.0.0.1:5199/#/tasks>。按启动终端中的 Ctrl+C 停止本次启动的服务。重新执行上面的命令可恢复数据库和加密密钥；不清空历史任务。端口冲突时退出，不停止已有服务。

| 服务 | 地址 |
|---|---|
| 页面 | http://127.0.0.1:5199 |
| AgentGate API | http://127.0.0.1:8099 |
| 本地对端 | http://127.0.0.1:8119 |
| 独立 Redis | 127.0.0.1:6399 |

数据和日志在 `runtime/agent-platform/local/`。`credential.key` 首次启动随机生成、权限为 0600；它用于解密已排队任务的 Token，不应删除或加入版本库。Token 只以加密形式保存在凭据表，任务中保留引用；页面持久存储、任务 JSON 和队列消息不保存原文。凭据保留以支持预约和重跑；手工移除凭据后，相关待执行运行会明确失败。

## 验收步骤（登录体系改造后）

1. 打开站点自动进入**欢迎页面**。在“请输入行内用户token”填写 `local-demo`，点击“行内Login”；在“选择个人/团队空间”选“本地验收团队”（或个人空间），确认后进入主页面。顶栏右侧显示“行内 · …”徽标与“登出 Logout”按钮。
2. “评测任务 → 新建评测任务”：评测对象环节为三控件一排（选择智能体 / 分支地址 / 智能体版本），无 token/团队/类型控件。选择“基础编排 · 本地模拟”，此时“分支地址”应置灰显示“不适用（base/workflow）”，版本经接口2选择 `1.0` 或 `2.0`。
3. 评测集选“平台模拟验收 · 文本与多轮”，版本 v1，点击“采用推荐评估器”。保留默认执行参数并“开始评测”。应看到 3 条样本完成、通过率 100%；样本 3 含两轮对话。
4. 新建另一个任务，智能体选择“云虾 · 本地模拟”，“分支地址”经接口5选“审核分支 · branch-review”，版本经接口6选 `1.0`，稳定性测试填 2。应看到两轮运行、6 条样本完成。
5. 再次选择不同智能体或分支，确认已经选择的数据集、评估器及手动输入的执行参数不被改写；上游变更应清空依赖的目标选项。
6. 点击顶栏“登出 Logout”，确认提示后返回欢迎页面，token 与目标选择全部清空；重新登录可以继续选择。
7. 在欢迎页点击“行外Login”可直接进入本地环境（目录来自本地虚拟地址，无 token）。
8. 单次任务选择未来的预约时间，应先显示等待，到期后由调度器执行。重复执行不能与预约组合。
9. A/B 回归：切换 A/B，选择“贷款审批演示智能体（内置 Demo）”，使用原有贷款评测集与推荐评估器，创建双版本对比。

已运行的验收任务会保留在任务列表，可直接查看样本结果。测试用例以文本回显匹配作为通过标准，100 分不表示真实智能体业务能力。

## 模拟接口与契约

目录遵循用户提供文档：

- 接口 3：`GET /web/ops/team/getTeamRole`，包装后的分页响应，选项身份使用 teamId。
- 接口 4：`GET /web/agent/agents`，直接分页响应。
- 接口 2：`GET /web/agent/getAgentVersionList`。
- 接口 5：`GET /web/abcclaw/v2/branchTree`，包含嵌套分支。
- 接口 6：`GET /web/abcclaw/v2/listVersions`，版本带对应 branchId。

所有目录数据来自同目录 `fixtures.json`。基础编排/工作流通过文档中的 `createAgent?taskId=...` 创建实例，请求体仅含 `agentId` 和 `agentVersion`，随后健康检查、初始化一次会话、多轮对话和删除实例。

云虾文档只定义对话接口，未定义分支到运行实例的创建契约。因此仅在本地使用 `POST /mock/abcclaw/instances?taskId=...`，明确传 agentId、agentVersion、branchId；这不是行内生产接口。后续对话使用文档的 `/api/v1/message` 格式。

`GET /mock/evidence` 返回本次服务进程的创建、会话、对话、删除记录及活动实例数，不记录 Authorization 或 Token。每条样本执行后清理实例；文本“模拟失败”可触发错误响应测试清理路径。

## 已知边界

- 执行接入当前只启用显式 `mock` 模式和本机回环地址，且要求对端声明模拟协议；不会把本地验收当作行内生产验证。
- 目录尚未提供 Skill、工具、Prompt、图谱信息，页面按已确认方案禁用新目标静态分析并提示图谱不可用。Trace 只记录实际观察到的对话输入和输出，不伪造工具/Skill 调用。
- 本期模拟文本用例输入为 `{"txt":"文本"}`，不支持文件上传或初始业务状态；不支持的用例会明确拒绝，不会忽略后继续运行。
- A/B 保留原有入口、版本来源及接口，不使用本地平台目录替换。

## 验证

```sh
.venv/bin/python -m pytest -q
frontend/node_modules/.bin/playwright test --config frontend/tests agent-target-picker.spec.ts agent-platform-task.spec.ts --workers=1
npm --prefix frontend run build
```

Python 测试使用临时数据库和本地随机端口，不需要上面的常驻服务。浏览器专项测试自带隔离页面和 HTTP 测试数据；人工页面验收使用上面的完整服务。

## 本地扩展：智能体能力声明（图谱数据源）

`GET /web/agent/capabilities?agentId=&agentVersion=[&branchId=]` 返回该智能体声明的
工具与 Skill 列表（`fixtures.json` 的 `agentCapabilities`）。该接口是本地扩展，平台
目录文档未定义；未登记能力的智能体（如 agent-workflow）返回 404，调用方据此优雅
降级为"目录未提供图谱信息"。前端据此派生 Agent → Skill → Tool 图谱。
