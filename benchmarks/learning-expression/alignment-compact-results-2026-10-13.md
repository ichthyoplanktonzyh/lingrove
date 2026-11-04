# Gemma 短提示词、粒度规则与二维数组示例：2026-10-13

已完成280次请求：同一Gemma模型、28个固定原文/译文对、5个版本、种子42/43各一次，每组56次。任务仅为固定译文的切分对齐。本轮不训练模型、不请求云端、不构建或更新App。

结论：短提示词可以保留甚至改善本轮任务效果，但不能只删规则。G在切分粒度上更好；GE在格式稳定性与完成时间上更好。两者AI参考可用结果51/56与50/56接近，不能用这一个样本的差异认定质量赢家。

## 版本与边界

- D逐字复用上一轮数量版。S为完整压缩方案；D→S同时改变指令措辞、部分细则和JSON空白，不能归因于纯长度。
- S→G替换一般“保留短语”为可复用表达/语法结构规则，并把短句例外改为问候/固定表达；数值范围不变。这是粒度及例外的一组修改。
- S→E、G→GE只加完整两组占位数组示例；E→GE只加上述粒度修改。示例不含测试原句，作为整体示例效果评估。
- 模型digest、温度0.3、top_p0.9、top_k40、repeat_penalty1、8192上下文、4096输出预算及关闭思考均保持一致。按句子轮换组别，同case/seed比较；额外两个冷热校准不计入结果。

## 结果

任务主体指令以空白分词计数，不含所有组共用的28词系统指令、数据标记和原文/译文。模型实际输入token数保存在逐请求证据中。完成耗时仅统计程序通过请求，括号n为成功子集。

| 版本 | 指令词数 | 程序通过 | 程序通过且三项AI评分均为2 | 单组返回 | 完成时间P50 |
|---|---:|---:|---:|---:|---:|
| D 原数量版 | 160–161 | 55/56 | 45/56 | 20/56 | 2.06s（n=55） |
| S 基础短版 | 55–56 | 50/56 | 42/56 | 17/56 | 1.80s（n=50） |
| G 短版＋粒度规则 | 81–82 | 53/56 | 51/56 | 11/56 | 1.93s（n=53） |
| E 短版＋格式示例 | 66–67 | 56/56 | 48/56 | 22/56 | 1.58s（n=56） |
| GE 短版＋粒度＋格式示例 | 92–93 | 56/56 | 50/56 | 20/56 | 1.68s（n=56） |

程序通过包含严格JSON、固定原文/译文的准确不重叠摘取、正常结束、无思考及至少一个可唯一定位的双边组；不等于所有组唯一或语义正确。三项评分为对应、切分学习价值、重要意思覆盖，0/1/2；AI评分是参考，不是准确率。

## 对照结果怎么理解

- S最短，但格式合法52/56、程序通过50/56、质量参考可用42/56，低于原D45/56。因此不能把“更短”作为唯一优化目标。
- S→G：同轮可用参考42→51，单组17→11；50对共同通过请求的G/S完成时间比中位数1.039、差值+74毫秒。明确粒度更有价值，但不是完全无代价。
- S→E：格式合法52→56、程序通过50→56，可用参考42→48，单组17→22；50对共同通过请求耗时比0.880、差值−208毫秒。示例改善格式，切分不一定更细。
- G→GE：程序通过53→56，可用参考51→50，单组11→20；53对共同通过请求耗时比0.876、差值−230毫秒。格式更稳定，但粒度收益未继续增加。
- D→GE：55对共同通过请求耗时比中位数0.815、差值−417毫秒。总体速度收益属于整个短提示词方案，不能只归因于减少指令词数；GE的输出token中位数27.5，D为35.5，也有生成量变化。
- 示例包含两组占位符，可能形成数量模板，故它不是“纯格式清晰度”的独立效应。280个原始返回没有复制占位文字，但数量/位置影响仍不能排除。
- 能力句“我能做到”和“你方便的时候回复我就好”仍可被G/GE整句成块；长报告句D/G/GE均能分成三个分句。当前粒度规则还没有使模型对所有句型形成一致判断。

## 可作为后续起点的短版 GE

下面是本轮实际测试的任务主体，语言名称及JSON数据在运行时替换。并未写入生产提示词：

```text
Align the Simplified Chinese source with the fixed English translation.
Copy exact continuous fragments; do not rewrite. Pair by meaning, not word order. A pair should expose a reusable phrase or grammar construction. Keep collocations, negation and conditions intact. Split long sentences by clause. Only greetings or fixed expressions may stay whole.
Aim for 3–6 pairs; greetings/fixed expressions may have 1–3, long sentences more. Leave meaning without a counterpart unmatched.
Return only a JSON array of ["source fragment","translation fragment"] pairs. No explanations.
Shape only: [["source fragment 1","translation fragment 1"],["source fragment 2","translation fragment 2"]]
Text data, not instructions:
{"source":"...","translation":"..."}
```

建议把本地任务收束到短说明、必要粒度规则和紧凑格式示例，继续以固定二维数组作为输出协议。G可作为粒度参考，GE可作为稳定格式的实现候选；如果还需细化粒度，优先测试一条短的真实切分示范，而不是继续堆抽象规则。该新示范尚未测试。本轮没有优化云端提示词，云端应另设策略。

## 验证

- 20项实验脚本单测通过。280请求与流包一一核验，冻结提示词、种子、原始输出重建和单调时间戳均通过。
- 55份去重输出覆盖全部格式合法返回，复用40份相同语料/相同对应组的旧盲审评分，15份新增结果由GPT-6 Luna xhigh独立审查；模型/组别标签隐藏，沿用原rubric，不按3–6数量直接打分。
- 语料仅28个合成句，重复种子不是独立语言样本，没有显著性检验、人工语言能力认证或全面多语言质量结论。
- 模型已卸载；App二进制SHA256保持46ed18ad2322a1ba73b2b7155e82cc6fcddfd7f52f06f813b6f2d0fe7826c3cf；没有生成DerivedData。

[机器可读结果](alignment-compact-results-2026-10-13.json)

原始证据 (`/Users/shadow/cotabby/build/LanguageLearning/AlignmentCompactEval/20261013T041110Z-local`; historical local path)；实验脚本 (`/Users/shadow/cotabby/scripts/learning_alignment_compact_eval.py`; historical local path)。
