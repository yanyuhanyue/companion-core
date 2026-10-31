# 观看账本

B站视频、小黑盒帖子或某个已完成目标读到的网页读完后，她会对每条内容记一笔自己的看法：打分（-2 到 2）、不超过 60 字的一句话看法，以及最多 3 个话题标签。聊天时，她可以引用最近的这些记录，也可以主动提起。设计由主人于 2026-10-29 确认：使用模型判断，保留期跟随来源，允许主动提起，小黑盒也记入。

## 流程

1. 生活 Worker 的 `watch` 通道在 `exploration` 授权下运行。它扫描最近 `lookback_hours` 小时内状态为 FETCHED 或 WATCHED 的 `observation.bilibili` / `observation.heybox` 观察，以及作为已完成目标步骤结果的 `observation.web` 观察，给还没有记录的内容加一条 `PENDING`。随手抓取、没有完成目标的网页不记。同一个链接只记一次。
2. 读取深度只根据证据判断，不采信模型的说法：
   - 有视频分析为 `media_sampled`；
   - 有字幕为 `subtitle`；
   - 有评论为 `comments`；
   - 有正文为 `text`；
   - 否则为 `title_only`。`title_only` 不调用模型，直接 `SKIPPED`。
3. **补评：** 同一个链接之后来了读得更深的观察（例如正文读完后补上的视频分析）时，已结束的记录会改为指向新观察，重新判断一次。读得更浅的观察不会触发重评；正在调用或调用结果不明（UNKNOWN）的记录保持不动。
4. 每条记录调用一次 `watch_review` 场景。
   - 这是一次后台调用，不绑定任务，使用 JSON 模式，输出上限 `max_output_tokens`，每日上限 `daily_micro_usd`。
   - 调用沿用原有的预算、OwnerAuthority 和 UNKNOWN 规则；有主人消息待处理时让路。
   - 资料按数据传入，资料中的要求不执行。
5. 失败处理：
   - **准入被拒且未发出请求：** 记为 `RETRY_WAIT`。超出每日上限时等到次日。
   - **输出格式不合法：** 用新请求重试，最多 `max_attempts` 次。
   - **计费不明：** 记为 `UNKNOWN`，永不重放。
   - **来源变化或被删除：** 记为 `CANCELLED`。

## 撤回

主人可以通过 `POST /internal/v2/watch-ledger/{entry_id}/withdraw` 撤回一条已判断的看法（例如看法基于错误的资料）。记录改为 `WITHDRAWN`，评分和看法清空，之后同一链接不再重新判断；引用这条看法的待审或已接受的反思假设回到 `NEED_MORE_EVIDENCE`，由它产生的未完成目标被撤回。来源观察本身保留。迁移 `0056_watch_ledger_goal_reads` 为网页和撤回状态扩展了约束；存在网页或撤回记录时拒绝降级，避免撤回的看法被重新判断。

## 看法的形成

账本只记单次感受。兴趣模块把同一兴趣下每次独立完成的阅读和对应记录按阅读顺序重放，推导出暂时或较稳定的看法及每次变化的原因，见 `docs/qq-beta/autonomous-life.md`。这些推导不单独存储。

## 删除

`erasure.py` 注册了 `watch-ledger` 清理器。来源观察被遗忘、来源授权撤销或原始事件到期时，对应记录一并删除，旧备份恢复后会重放删除。聊天引用只读取来源仍然有效的记录。

## 启用

默认关闭。启用方式：在配置里设 `[watch_ledger] enabled = true`，或者设环境变量 `COMPANION_WATCH_LEDGER='{"enabled": true}'`。和 `rem` 一样，`watch_review` 不进入付费合同快照，它的每日上限在预留时按配置执行，同时受已批准窗口的总额约束。因此启用后现有 policy 仍然有效，只需要 policy 里已有 `exploration` purpose。
