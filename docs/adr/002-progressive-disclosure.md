<!-- SPDX-FileCopyrightText: 2026 wangdong <wangdong5919@163.com> -->
<!-- SPDX-License-Identifier: Apache-2.0 -->


# 002: Progressive Disclosure（渐进式披露）

## 状态

已接受

## 上下文

Skill 系统需要处理大量 Skill，每个 Skill 可能包含很长的系统指令。如果在启动时加载所有 Skill 的完整内容，会导致：
1. 启动时间过长
2. 内存占用过大
3. 不必要的 Token 消耗（很多 Skill 可能不会被使用）

## 决策

采用渐进式披露策略：

### 1. 元数据常驻内存

- 启动时仅加载所有 Skill 的 Frontmatter（元数据）
- 元数据包含：name, description, tags, triggers, category 等
- 元数据体积小，可快速加载

### 2. 内容按需加载

- Skill 的指令内容仅在第一次被调用时加载
- 加载后存入 LRU 缓存
- 缓存淘汰策略：最近最少使用

### 3. LRU 缓存配置

```python
# 默认配置
CACHE_SIZE = 50  # 缓存 50 个 Skill
TTL = 3600  # 缓存 1 小时
```

## 理由

1. **启动快** - 只加载元数据，启动时间从数秒降至毫秒级
2. **内存省** - 只缓存常用 Skill，内存占用可控
3. **Token 省** - 只在需要时才加载和使用完整指令
4. **用户体验好** - 首次调用略慢，后续调用快速响应

## 后果

### 正面
- 显著提升启动速度
- 降低内存占用
- 节省 Token 消耗

### 负面
- 首次调用 Skill 有额外延迟
- 需要实现缓存机制
- 缓存一致性需要考虑

## 替代方案

### 方案 A：全部预加载

- 简单易实现
- 但启动慢、内存占用大

### 方案 B：按需加载，不缓存

- 实现简单
- 但每次调用都有 I/O 开销

## 实现细节

### 缓存策略

- 使用 LRU（最近最少使用）策略
- 支持配置缓存大小
- 支持配置 TTL（生存时间）

### 缓存失效

- Skill 文件修改时自动失效
- 支持手动刷新缓存
- 启动时清空缓存（可选）

## 相关决策

- [001: Skill System Architecture](001-skill-system-architecture.md)
