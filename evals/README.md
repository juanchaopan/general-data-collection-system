# AI 审查员的考卷

这个目录收集项目里真实出过的 bug，用来检验 AI 审查员：如果那次改动重新交给它审，它能不能抓到？

## 什么时候加案例

- 一个 bug 合并后才被发现（被用户报告、上线后出错、或者被你 revert 了）。
- AI 审查员误报了，而那次改动其实没问题。这种也值得记下来，作为"干净"案例，用来检查误报。

## 怎么加

复制 `review-cases/_template.md`，改名为 `<日期>-<简短描述>.md`，填好开头的元数据：

| 字段 | 含义 |
|---|---|
| `id` | 案例名，和文件名一致即可 |
| `expect` | `bug`：这段改动里有 bug，审查员应该报出来；`clean`：这段改动没问题，审查员不应该报 Important |
| `pr` | 引入这次改动的 PR 编号。也可以不写 `pr`，改写 `base` 和 `head` |
| `base` / `head` | 改动前和改动后的提交号，二者的差就是要审的 diff |
| `file` / `line` | bug 所在的文件（相对仓库根目录）和改动后的行号。`clean` 案例不用填 |

正文写清楚发生了什么、根因是什么、后来怎么修的，方便以后回顾。

## 怎么跑

```
node evals/run-review-evals.mjs            # 跑全部案例
node evals/run-review-evals.mjs <id> ...   # 只跑指定案例
```

审查员在 bug 所在行附近（默认上下 10 行内）报出 Important，就算抓到。每次的分数会追加到 `results.jsonl`，里面记下了当时 REVIEW.md 的版本。

可选的环境变量：`EVAL_MODEL` 指定模型，`EVAL_LINE_TOLERANCE` 设置行号允许的偏差。

## 什么时候跑

改了 REVIEW.md 或 CLAUDE.md、换了模型、或者觉得审查质量变了的时候跑一次。分数没有上升，就撤回那次修改。

每跑一个案例就是一次 Claude 调用，会消耗额度。
