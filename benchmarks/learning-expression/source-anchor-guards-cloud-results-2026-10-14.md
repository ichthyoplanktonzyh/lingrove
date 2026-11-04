# 原文锚点提示词的协议补充与 Gemma 31B 尝试（2026-10-14）

DeepSeek Flash 同场完成旧版、新版各 30 个固定句对，新旧都为 28/30 个产品解析可用结果，没有看到总体提升。Gemma 4 31B 模型查询成功，但五次生成均返回 `500 INTERNAL`，未获得模型内容，本轮无法比较它的质量或生成速度。

## 提示词改动

旧版逐字复用上一轮原文意义锚点提示词 (`/Users/shadow/cotabby/benchmarks/learning-expression/source-anchor-cloud-results-2026-10-14.md`; historical local path)。新版只在输出格式要求前增加以下两行，其余示例、原文、固定译文和语言字段均保持一致：

```text
每项必须恰好包含两个非空字符串。
如果一个意思只能对应不连续文字，优先合并为自然的较大连续片段；无法可靠合并时省略，不得删词或拼接片段。
```

两版继续以原文自然意义为理解起点，只输出原样摘取的连续片段二维数组，不要求 3–6 组，不生成解释，也不改写固定译文。实验没有修改产品提示词。

## DeepSeek 同场对照

`deepseek-flash`，显式 `thinking=disabled`，temperature 0.3，max_tokens 4096，流式返回、不强制 schema。用例与上一轮相同：28 个既有合成句对及两个与示例相关的变体。每个句对各版本只取一次，随机调整请求顺序，所有请求串行执行；调度种子不是模型采样种子。没有自动重试。

| 指标 | 旧版 v1 | 新版 v2 |
|---|---:|---:|
| 完整正常结束、无思考输出 | 30/30 | 30/30 |
| 当前产品解析器可用 | 28/30 | 28/30 |
| 首段 JSON 内容 P50 / P95（n=30） | 2.12s / 2.38s | 2.13s / 2.73s |
| 完整响应 P50 / P95（全部请求，n=30） | 2.29s / 2.55s | 2.34s / 3.16s |

同一用例的新版减旧版完成耗时差，中位数约 +62ms。新版的尾部时间更高，但网络、服务排队、预填充及缓存均包含在计时内，不能直接归因于这两条规则。没有统计显著性或等效性检验。

时间只针对对固定译文进行对齐的 HTTP 请求，不测翻译生成、输入停顿、Accessibility 获取和 UI。首段 JSON 并不表示可展示；产品需要完整批次通过解析后才着色。

## 修好一个空组，另一个空组仍出现

旧版的韩语否定案例包含 `["只是", ""]`。新版改为：

```json
[["我不是不想去","가고 싶지 않은 게 아니라"],
 ["只是今天没时间","오늘은 시간이 없어요"]]
```

这次通过了产品解析器，显示合并片段的指导有时能奏效。但礼貌回复句在新版中出现了新的空组：

```json
[["你方便的时候","whenever it is convenient for you"],
 ["回复我","Reply"],
 ["就好",""]]
```

两版的疑问句都返回：

```json
[["你","you"],["吃饭了吗？","Have you eaten?"]]
```

这里两组重复占用了译文中的 `you`。虽然没有删词拼接，仍违反当前解析器的不重叠范围规则，整批被拒绝。本轮失败没有修复后重新计为成功：旧版失败为疑问句与韩语空组，新版失败为疑问句与礼貌回复空组。仅加“不得删词”和“非空”不能保证稳定协议遵循。

## 独立学习价值审查

30 个句对中，21 个新旧结果在去除 JSON 空白差异后相同，9 个有变化。两名 GPT-6 Luna xhigh 独立审查全部 9 对，随机分配 A/B 标签，隐藏版本和耗时；按原文意思是否易懂、对应是否忠实、表达是否完整评价。

两人的最终偏好一致：新版较好 2 项，旧版较好 3 项，4 项相当。新版优势是韩语否定去掉空组、韩语时长构式合并为完整表达；旧版优势是礼貌回复没有空组、韩语回电边界更合适、德语条件句保持完整。价格纠正、技术请求、过去与现在、时间安慰属于合理的粒度取舍。

审查说明逐项核对原始片段，并区分了固定译文本身的信息取舍与对齐新增错误。两名审查者的相同偏好不是两次模型复现；这是对同一次生成的主观评价，尤其韩语、德语细微语感仍不确定，不能当作准确率或泛化能力证明。

## Gemma 4 31B：接口失败，尚无质量结果

官方 Gemini API 支持 `gemma-4-31b-it`，可通过 `thinkingLevel=minimal` 关闭思考，并支持独立的系统指令。[官方调用文档](https://ai.google.dev/gemma/docs/core/gemma_on_gemini_api)。官方价格页将 Gemma 4 列在免费层；本轮没有检查或修改账户计费设置。[官方价格](https://ai.google.dev/gemini-api/docs/pricing)。

使用原生 `generativelanguage.googleapis.com` REST 接口，密钥放在 `x-goog-api-key` 请求头，不放 URL，也不使用兼容层。模型 GET 成功返回 `models/gemma-4-31b-it`，version `001`，但以下生成均返回相同 `HTTP 500 / INTERNAL / Internal error encountered.`：

| 尝试 | 请求形态 | 结果 |
|---|---|---|
| 正式请求 1 | 新版提示词，流式，关闭思考 | 500 |
| 诊断请求 1 | 独立天气句对，相同流式配置 | 500 |
| 诊断请求 2 | 相同配置改为非流式 | 500 |
| 诊断请求 3 | 流式，去掉思考配置 | 500 |
| 诊断请求 4 | 最简非流式，仅 contents，去掉系统字段和生成配置 | 500 |

原计划两个模型各版本 30 次，共 120 次正式请求。Google 正式请求首次接口失败后停止其余 59 次，DeepSeek 继续完成；实际正式请求为 61 次，额外四次 Google 诊断不计正式评分。没有改用其他模型或把错误恢复后的输出算作原请求成功。

五次没有产生模型内容或 token 用量。500 的错误返回时间不是生成延迟，也不能据此评价该模型效果，或证明密钥、配额、地区等具体原因。模型查询成功也不等于生成权限已得到验证。官方建议针对临时服务错误做有次数上限的重试；本轮保留了不同请求形态的诊断证据，但无法确定内部失败原因。[官方排错指南](https://ai.google.dev/gemini-api/docs/troubleshooting)。

## 建议与验证

暂不把新版认定为更好的基线，也不替换产品配置。可以保留这两条规则作为协议说明，但今后需要单独验证“不重叠、无法逐词对应时整组表达”等指导，避免一次增加很多要求。Gemma 31B 需在 Google 生成接口可用后才能补完同一套用例。

DeepSeek 总输入 15728 tokens（缓存命中 379、未命中 15349），输出 1900 tokens，共 17628 tokens。Google 未返回生成用量；不推断失败请求是否计入免费额度。只发送固定合成句对，没有发送用户实际编辑内容、屏幕或剪贴板，也没有写入密钥。

新增 Google 传输边界的 8 项单测通过，覆盖增量流、截断、终止状态、意外思考输出、服务器回显脱敏、额度错误不自动重试、固定主机与请求头认证、提示词仅修改两行。61 个正式请求的提示词、原始流重建、实际响应模型和产品解析结果均核对；9 对评分身份逐项校验。独立 Swift 编译缓存已清理，`build/DerivedData` 不存在。没有运行本地模型、构建或替换应用。

机器可读完整结果 (`/Users/shadow/cotabby/benchmarks/learning-expression/source-anchor-guards-cloud-results-2026-10-14.json`; historical local path)；原始请求结果 (`/Users/shadow/cotabby/build/LanguageLearning/CloudPairEval/20261014T044619Z/results.jsonl`; historical local path)；冻结提示词 (`/Users/shadow/cotabby/build/LanguageLearning/CloudPairEval/20261014T044619Z/prompts.json`; historical local path)。

实验调度及 Google 流式边界 (`/Users/shadow/cotabby/scripts/learning_alignment_cloud_pair_eval.py`; historical local path)复用原有 DeepSeek 安全传输、输入冻结和产品解析包装；它独立于产品服务，仅负责发出测试请求并记录证据。边界单测 (`/Users/shadow/cotabby/scripts/tests/test_learning_alignment_cloud_pair_eval.py`; historical local path)使用内存假响应，不访问云端。
