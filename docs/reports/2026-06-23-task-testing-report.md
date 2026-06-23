# `/task` v2 测试报告

> **测试时间**:2026-06-23
> **测试范围**:`/task` v2 重构后的完整流程验证(交接文档要求)
> **测试方式**:静态代码审查 + 自动化测试基线 + smoke:task 真实 LLM 跑通
> **结论**:**v2 核心承诺已兑现,自动化覆盖扎实。** 发现 1 个数据遗留、2 个测试盲区、2 个待用户决定的 followup。真实 TUI dogfood(创造流程)因耗时未在本会话跑,建议用户本机实测。

---

## 一、验证结论总览

| 验证项 | 方式 | 结果 |
|---|---|---|
| 测试基线 | `npm test` | ✅ **420/420 pass** |
| 场景 B 复用流程(dispatcher 真跑) | `npm run smoke:task` | ✅ **PASS,16s** |
| dispatcher 不走 fallback | smoke `hasTaskInputFallback` | ✅ **absent**(核心承诺兑现) |
| worker→verify→PASS 全链路 | smoke + taskbook runs | ✅ run status=pass |
| widget 进度(worker/verify 切换) | smoke widget 时间线 | ✅ 正常显示+清理 |
| Judge UI 污染 | smoke `hasActiveJudgeUiPollution` | ✅ **absent**(隔离干净) |
| dispatcher 边界输入(中文/空格/emoji) | RPC 探针(3 case) | ⚠️ 未超时未 fallback,但 PASS 检测未命中(探针脚本缺陷,非 task bug) |

---

## 二、v2 核心承诺逐条核对(代码层)

### ✅ 承诺 1:零命令记忆

- `/task` 空命令 → `resolveTaskCommandArgs` 弹中文菜单
- `--output-dir`/`--input`/`--input-file`/`--input-json` 全部删除(grep 确认 task.ts 无这些 flag)
- save 的 outputDir 自动用 `state.executeRunDir`
- save 的 input 用 `resolveSelfCheckInput`(空字段)或失败时 `askSelfCheckInput`

### ✅ 承诺 2:execute 完成后 review 不用用户写摘要

- `state.executeProcessLog` 字段存在(`task-state.ts`)
- executing 阶段 `tool_call` handler 记录实际工具调用 + artifact(`task.ts`)
- `task_complete` 触发 `prepareReviewFromExecute`,自动用 `formatExecuteSummary` 生成 summary
- **测试覆盖**:`task-extension.test.ts` 验证了环境工具保留、processLog 收集、Enter gate review 过渡和 summary 注入

### ✅ 承诺 3:自然语言 input 走 dispatcher

- `task-dispatcher.ts` 用 `ctx.model` + `complete()` 真实 LLM 调用
- dispatcher 失败才 fallback 到 questionnaire
- **smoke 实测**:`dispatcher fallback input: absent` 证明真实 LLM 路径走通

### ✅ 承诺 4:Enter gate 阶段过渡

- `pendingTransition` 状态字段(`task-state.ts`)
- planning/execute/review/save 四个过渡点都有"按 Enter 继续,或输入意见"
- `input` event handler 检测空 Enter 推进 / 非空当反馈
- **测试覆盖**:`task-extension.test.ts` 覆盖 RPC input 推进和 Enter gate review

### ✅ 承诺 5:autocomplete 崩溃修复

- 已在前一会话 commit `fe1dbdc` 交付,11 个真实 TUI 场景验证通过(交接文档记录)
- 本会话未重测(范围外)

---

## 三、发现的问题

### 🟡 问题 1(数据遗留,非 bug):grapheme-count taskbook runs[0] input 污染

**现象**:`~/.pi/agent/tasks/grapheme-count/taskbook.json` 的 `runs[0].input` 是:
```json
{ "text": "{\"text\":\"xyz789\"}" }
```
后 3 次 run 正确:`{ "text": "xyz789" }`。

**分析**:这是 v2 重构**之前**(v1 时期)某次 run 沉淀的脏数据——当时 input 解析用 `split(/\s+/)` + JSON.parse,把字符串化的 JSON 当成了 text 字段值。v2 的 dispatcher 已修复(后 3 次 run 都正确)。

**影响**:仅历史数据,不影响当前功能。taskbook 的 verify/skill/contract 质量良好(verify 覆盖 emoji 组合边界)。

**建议**:可手动清理那 1 条脏 run,或忽略(无害)。

### 🟠 问题 2(测试盲区):场景 A 创造流程无 e2e 覆盖

**现状**:`smoke-task.mjs` 只覆盖场景 B(复用预置 taskbook)。场景 A(`/task new` → planning → execute → review → save 完整创造流程)只有单元测试(mock pi + mock agent_end 事件),**没有真实 LLM 端到端验证**。

`task-extension.test.ts` 用 mock 的 `agent_end` 事件模拟 LLM 输出 Spec/skill/verify,验证了状态机和过渡逻辑,但**没验证真实 LLM 能产出合法的 Spec/skill/verify/contract JSON**。

**风险**:review agent 真实输出格式若跟 `extractTaskReviewResult` 的解析不匹配,单元测试发现不了。交接文档也把这个列为"已知遗留"。

**建议**:补一个 `smoke:task-create.mjs`,用真实 DeepSeek 跑一个纯本地任务(如"统计目录下 .ts 文件数输出 count.json")的完整创造流程。这是 v2 "傻瓜式"承诺最该补的验证。

### 🟠 问题 3(测试盲区):dispatcher 真实 provider 路径未单测

**现状**:`task-dispatcher.test.ts:52-74` 用 `registerFauxProvider()` mock 了 provider,**`callDispatcher` 里 `ctx.modelRegistry.getApiKeyAndHeaders` 失败(auth.ok=false/apiKey 空)的分支没有测试**。

我本会话写探针想补这块,但独立脚本无法注册 pi runtime 的 provider(报 `No API provider registered`),只能靠 smoke 间接验证真实路径。smoke PASS 证明真实路径工作,但单测层缺直接覆盖。

**建议**:`task-dispatcher.test.ts` 加一个 case:auth 失败时 dispatcher 返回 undefined → 走 questionnaire fallback。已有 `:26-40` 测了 questionnaire fallback,但没显式断言"因 auth 失败而 fallback"。

---

## 四、需要用户决定的事

### 决定 1:是否补场景 A 的 smoke e2e?

这是交接文档"测试建议"里第二项(创造流程)。需要:
- 写 `scripts/smoke-task-create.mjs`(约 200 行,复用 smoke-task.mjs 的 RPC 框架)
- 跑一个纯本地任务,验证真实 LLM 产出合法 Spec/skill/verify/contract
- 耗时:写脚本 + 调试约 1 小时,跑一次约 1-2 分钟

**我的建议**:值得补,这是 v2 最大的未验证面。但要不要现在做,你定。

### 决定 2:是否清理 grapheme 的脏 run + 修 User scope key?

两件小事:
- `~/.pi/agent/tasks/grapheme-count/taskbook.json` 的 runs[0] 脏数据(可手动删那一条)
- User scope 的 `DEEPSEEK_API_KEY` 还是失效的 88 字符 key(每次跑都要从文件注入)。可 `setx` 永久设成 35 字符有效 key,并把 `E:\AII\deepseek.txt` 删掉(key 不该明文落盘)

### 决定 3:是否动 bilibili-download taskbook?

交接文档说它"手动测试时沉淀,质量可能参差"。我没测它(B 站 412 反爬 + chrome_cdp 依赖,失败面大)。要不要用新流程重做,你定。

---

## 五、不要做的事(确认遵守交接约束)

- ✅ 未碰 Judge 代码
- ✅ 未碰 smoke-tui 未提交改动
- ✅ 未 `git add` 8 个旧 untracked docs
- ✅ 未 commit/push(本报告是新建 untracked doc,未 add)
- ✅ 未输出任何 API key
- ✅ 临时探针脚本已清理,仓库无新增改动

---

## 六、给下个会话/用户的实测建议

如果要在真实 TUI 里 dogfood,推荐顺序(从简到繁):

1. **复用(已由 smoke 覆盖,可跳过)**:`/task run grapheme-count Hello 世界`
2. **创造(关键)**:挑纯本地任务,如"统计 `src/` 下 .ts 文件数,输出 count.json":
   - `/task` → 选"新建任务" → 答 questionnaire → Enter → 看 execute 自动产出 → Enter → 看 review 自动产 skill/verify/contract → Enter → 自动 save + verify 自证
   - **重点验证**:review 完成后**真的不用手写摘要**(executeProcessLog 自动收集)
3. **菜单**:`/task` 空命令,确认中文菜单傻瓜化

跑前记得先设有效 key:
```bash
KEY=$(grep -oE 'sk-[A-Za-z0-9]{20,}' "E:/AII/deepseek.txt" | head -1)
export DEEPSEEK_API_KEY="$KEY"
```

---

## 附:本会话执行的命令记录

- `npm test` → 420/420 pass
- `npm run smoke:task`(注入有效 key)→ PASS 16s,report 在 `.tmp/smoke-task/latest/report.md`
- 静态审查:全读 `extensions/task/*.ts`(1772 行)+ 2 个测试文件 + 2 个 taskbook
- RPC 探针(已清理):验证 dispatcher 不 fallback,但 PASS 检测逻辑有缺陷导致 TIMEOUT,非 task bug
