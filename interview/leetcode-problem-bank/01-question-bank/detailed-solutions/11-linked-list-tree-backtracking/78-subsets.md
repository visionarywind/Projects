# 78. 子集

## 元信息

- LeetCode 链接：https://leetcode.cn/problems/subsets/
- 题目 slug：`subsets`
- 来源专题：链表、树与回溯
- 来源分类路径：四、回溯 / §4.2 子集型回溯
- 难度分：Unknown
- 外部题解来源：https://leetcode.cn/problems/subsets/solutions/2059409/hui-su-bu-hui-xie-tao-lu-zai-ci-pythonja-8tkl/
- 外部题解授权状态：authorized-import
- 本地解析状态：draft-preview
- C++ 验证状态：not-run
- 生成时间：2026-09-16 11:11:08 +0800

## 授权导入：灵茶山艾府题解过程

- 题解标题：[【视频】三种写法：选或不选/枚举选哪个/二进制枚举（Python/Java/C++/Go/JS/Rust）](https://leetcode.cn/problems/subsets/solutions/2059409/hui-su-bu-hui-xie-tao-lu-zai-ci-pythonja-8tkl/)
- 作者：灵茶山艾府 (`endlesscheng`)
- 题解 slug：`hui-su-bu-hui-xie-tao-lu-zai-ci-pythonja-8tkl`
- topic id：`2059409`
- 授权状态：authorized-by-user-confirmation
- 导入时间：2026-09-17 11:57:36 +0800

## 视频讲解

请看[【基础算法精讲 14】](https://www.bilibili.com/video/BV1mG4y1A7Gu/)，制作不易，欢迎点赞~

## 方法一：选或不选（输入的视角）

对于输入的 $\textit{nums}$，考虑每个 $\textit{nums}[i]$ 是选还是不选，由此组合出 $2^n$ 个不同的子集。

$\textit{dfs}$ 中的 $i$ 表示当前考虑到 $\textit{nums}[i]$ 选或不选。

### 答疑

**问**：为什么要恢复现场？

**答**：我们来做个实验。去掉代码中的恢复现场那行代码，然后测试 $\textit{nums}=[1,2]$ 这个数据。你会发现答案居然包含 $[2,1,2]$，这是为什么呢？

看视频中的图。如果不恢复现场，当我们从 $[2]$ 递归返回后，$\textit{path}$ 中还残留有 $2$，对于后面的递归来说，这个 $2$ 是多余的。继续递归「选 $1$」的右子树时，会把 $1$ 加到 $\textit{path}$ 中，导致 $\textit{path} = [2,1]$；继续递归到「选 $2$」的右子树时，$\textit{path} = [2,1,2]$，显然这是错的。

```py [sol-Python3]
class Solution:
    def subsets(self, nums: List[int]) -> List[List[int]]:
        n = len(nums)
        ans = []
        path = []

        # 选或不选：讨论 nums[i] 是否加入 path
        def dfs(i: int) -> None:
            if i == n:  # 子集构造完毕
                ans.append(path.copy())  # 复制 path，也可以写 path[:]
                return

            # 不选 nums[i]
            dfs(i + 1)  # 考虑下一个数 nums[i+1] 选或不选

            # 选 nums[i]
            path.append(nums[i])
            dfs(i + 1)  # 考虑下一个数 nums[i+1] 选或不选
            path.pop()  # 恢复现场，撤销 path.append(nums[i])

        dfs(0)
        return ans
```

```java [sol-Java]
class Solution {
    public List<List<Integer>> subsets(int[] nums) {
        List<List<Integer>> ans = new ArrayList<>();
        List<Integer> path = new ArrayList<>();
        dfs(0, nums, path, ans);
        return ans;
    }

    // 选或不选：讨论 nums[i] 是否加入 path
    private void dfs(int i, int[] nums, List<Integer> path, List<List<Integer>> ans) {
        if (i == nums.length) { // 子集构造完毕
            ans.add(new ArrayList<>(path)); // 复制 path
            return;
        }

        // 不选 nums[i]
        dfs(i + 1, nums, path, ans); // 考虑下一个数 nums[i+1] 选或不选

        // 选 nums[i]
        path.add(nums[i]);
        dfs(i + 1, nums, path, ans); // 考虑下一个数 nums[i+1] 选或不选
        path.removeLast(); // path.remove(path.size() - 1);
    }
}
```

```cpp [sol-C++]
class Solution {
public:
    vector<vector<int>> subsets(vector<int>& nums) {
        int n = nums.size();
        vector<vector<int>> ans;
        vector<int> path;

        // 选或不选：讨论 nums[i] 是否加入 path
        auto dfs = [&](this auto&& dfs, int i) -> void {
            if (i == n) { // 子集构造完毕
                ans.emplace_back(path);
                return;
            }

            // 不选 nums[i]
            dfs(i + 1); // 考虑下一个数 nums[i+1] 选或不选

            // 选 nums[i]
            path.push_back(nums[i]);
            dfs(i + 1); // 考虑下一个数 nums[i+1] 选或不选
            path.pop_back(); // 恢复现场，撤销 path.push_back(nums[i])
        };

        dfs(0);
        return ans;
    }
};
```

```go [sol-Go]
func subsets(nums []int) [][]int {
    n := len(nums)
    ans := make([][]int, 0, 1<<n) // 预分配空间
    path := make([]int, 0, n) // 预分配空间

    // 选或不选：讨论 nums[i] 是否加入 path
    var dfs func(int)
    dfs = func(i int) {
        if i == n { // 子集构造完毕
            ans = append(ans, slices.Clone(path)) // 复制 path
            return
        }
        
        // 不选 nums[i]
        dfs(i + 1) // 考虑下一个数 nums[i+1] 选或不选
        
        // 选 nums[i]
        path = append(path, nums[i])
        dfs(i + 1) // 考虑下一个数 nums[i+1] 选或不选
        path = path[:len(path)-1] // 恢复现场，撤销 path = append(path, nums[i])
    }

    dfs(0)
    return ans
}
```

```js [sol-JavaScript]
var subsets = function(nums) {
    const n = nums.length;
    const ans = []
    const path = []

    // 选或不选：讨论 nums[i] 是否加入 path
    function dfs(i) {
        if (i === n) { // 子集构造完毕
            ans.push(path.slice()); // 复制 path
            return;
        }
        
        // 不选 nums[i]
        dfs(i + 1); // 考虑下一个数 nums[i+1] 选或不选
        
        // 选 nums[i]
        path.push(nums[i]);
        dfs(i + 1); // 考虑下一个数 nums[i+1] 选或不选
        path.pop(); // 恢复现场，撤销 path.push(nums[i])
    }

    dfs(0);
    return ans;
};
```

```rust [sol-Rust]
impl Solution {
    pub fn subsets(nums: Vec<i32>) -> Vec<Vec<i32>> {
        // 选或不选：讨论 nums[i] 是否加入 path
        fn dfs(i: usize, nums: &[i32], path: &mut Vec<i32>, ans: &mut Vec<Vec<i32>>) {
            let n = nums.len();
            if i == n {
                ans.push(path.clone()); // 子集构造完毕
                return;
            }

            // 不选 nums[i]
            dfs(i + 1, nums, path, ans); // 考虑下一个数 nums[i+1] 选或不选

            // 选 nums[i]
            path.push(nums[i]);
            dfs(i + 1, nums, path, ans); // 考虑下一个数 nums[i+1] 选或不选
            path.pop(); // 恢复现场，撤销 path.push(nums[i])
        }

        let n = nums.len();
        let mut ans = Vec::with_capacity(1 << n); // 预分配空间
        let mut path = Vec::with_capacity(n); // 预分配空间
        dfs(0, &nums, &mut path, &mut ans);
        ans
    }
}
```

#### 复杂度分析

- 时间复杂度：$\mathcal{O}(n2^n)$，其中 $n$ 为 $\textit{nums}$ 的长度。有 $2^n$ 个子集，所以搜索树有 $2^n$ 个叶子，每个叶子复制 $\textit{path}$ 需要 $\mathcal{O}(n)$ 的时间，一共需要 $\mathcal{O}(n2^n)$ 时间。
- 空间复杂度：$\mathcal{O}(n)$。返回值的空间不计。

## 方法二：枚举选哪个（答案的视角）

枚举子集（答案）的第一个数选谁，第二个数选谁，第三个数选谁，依此类推。

$\textit{dfs}$ 中的 $i$ 表示现在要枚举选 $\textit{nums}[i]$ 到 $\textit{nums}[n-1]$ 中的一个数，添加到 $\textit{path}$ 末尾。

如果选 $\textit{nums}[j]$ 添加到 $\textit{path}$ 末尾，那么下一个要添加到 $\textit{path}$ 末尾的数，就要在 $\textit{nums}[j+1]$ 到 $\textit{nums}[n-1]$ 中枚举了。

#### 答疑

**问**：代码的递归边界是什么？为什么没有判断 `i == n`？

**答**：当 $i=n$ 时，代码不会进入循环，更不会往下递归。此时 $\textit{dfs}(i)$ 只执行了一个逻辑：把 $\textit{path}$ 的拷贝添加到 $\textit{path}$ 中。

```py [sol-Python3]
class Solution:
    def subsets(self, nums: List[int]) -> List[List[int]]:
        n = len(nums)
        ans = []
        path = []

        # 枚举选哪个：在下标 i 到 n-1 中选一个数，加到 path 末尾
        def dfs(i: int) -> None:
            ans.append(path.copy())  # 不选，把当前子集加入答案
            for j in range(i, n):  # 选，枚举选择的数字
                path.append(nums[j])
                dfs(j + 1)  # 选 nums[j] 意味着 i 到 j-1 都跳过不选，下一个数从 j+1 开始选
                path.pop()  # 恢复现场

        dfs(0)
        return ans
```

```java [sol-Java]
class Solution {
    public List<List<Integer>> subsets(int[] nums) {
        List<List<Integer>> ans = new ArrayList<>();
        List<Integer> path = new ArrayList<>();
        dfs(0, nums, path, ans);
        return ans;
    }

    // 枚举选哪个：在下标 i 到 n-1 中选一个数，加到 path 末尾
    private void dfs(int i, int[] nums, List<Integer> path, List<List<Integer>> ans) {
        ans.add(new ArrayList<>(path)); // 不选，把当前子集加入答案
        for (int j = i; j < nums.length; j++) { // 选，枚举选择的数字
            path.add(nums[j]);
            dfs(j + 1, nums, path, ans); // 选 nums[j] 意味着 i 到 j-1 都跳过不选，下一个数从 j+1 开始选
            path.removeLast(); // path.remove(path.size() - 1);
        }
    }
}
```

```cpp [sol-C++]
class Solution {
public:
    vector<vector<int>> subsets(vector<int>& nums) {
        int n = nums.size();
        vector<vector<int>> ans;
        vector<int> path;

        // 枚举选哪个：在下标 i 到 n-1 中选一个数，加到 path 末尾
        auto dfs = [&](this auto&& dfs, int i) -> void {
            ans.emplace_back(path); // 不选，把当前子集加入答案
            for (int j = i; j < n; j++) { // 选，枚举选择的数字
                path.push_back(nums[j]);
                dfs(j + 1); // 选 nums[j] 意味着 i 到 j-1 都跳过不选，下一个数从 j+1 开始选
                path.pop_back(); // 恢复现场
            }
        };

        dfs(0);
        return ans;
    }
};
```

```go [sol-Go]
func subsets(nums []int) [][]int {
    n := len(nums)
    ans := make([][]int, 0, 1<<n) // 预分配空间
    path := make([]int, 0, n) // 预分配空间

    // 枚举选哪个：在下标 i 到 n-1 中选一个数，加到 path 末尾
    var dfs func(int)
    dfs = func(i int) {
        ans = append(ans, slices.Clone(path)) // 不选，把当前子集加入答案
        for j := i; j < n; j++ { // 选，枚举选择的数字
            path = append(path, nums[j])
            dfs(j + 1) // 选 nums[j] 意味着 i 到 j-1 都跳过不选，下一个数从 j+1 开始选
            path = path[:len(path)-1] // 恢复现场
        }
    }

    dfs(0)
    return ans
}
```

```js [sol-JavaScript]
var subsets = function(nums) {
    const n = nums.length;
    const ans = []
    const path = []

    // 枚举选哪个：在下标 i 到 n-1 中选一个数，加到 path 末尾
    function dfs(i) {
        ans.push(path.slice()); // 不选，把当前子集加入答案
        for (let j = i; j < n; j++) { // 选，枚举选择的数字
            path.push(nums[j]);
            dfs(j + 1); // 选 nums[j] 意味着 i 到 j-1 都跳过不选，下一个数从 j+1 开始选
            path.pop(); // 恢复现场
        }
    }

    dfs(0);
    return ans;
};
```

```rust [sol-Rust]
impl Solution {
    pub fn subsets(nums: Vec<i32>) -> Vec<Vec<i32>> {
        // 枚举选哪个：在下标 i 到 n-1 中选一个数，加到 path 末尾
        fn dfs(i: usize, nums: &[i32], path: &mut Vec<i32>, ans: &mut Vec<Vec<i32>>) {
            ans.push(path.clone()); // 不选，把当前子集加入答案
            for j in i..nums.len() { // 选，枚举选择的数字
                path.push(nums[j]);
                dfs(j + 1, nums, path, ans); // 选 nums[j] 意味着 i 到 j-1 都跳过不选，下一个数从 j+1 开始选
                path.pop(); // 恢复现场
            }
        }

        let n = nums.len();
        let mut ans = Vec::with_capacity(1 << n); // 预分配空间
        let mut path = Vec::with_capacity(n); // 预分配空间
        dfs(0, &nums, &mut path, &mut ans);
        ans
    }
}
```

#### 复杂度分析

- 时间复杂度：$\mathcal{O}(n2^n)$，其中 $n$ 为 $\textit{nums}$ 的长度。答案的长度为子集的个数，即 $2^n$，同时每次递归都把一个数组放入答案，因此会递归 $2^n$ 次，再算上加入答案时复制 $\textit{path}$ 需要 $\mathcal{O}(n)$ 的时间，所以时间复杂度为 $\mathcal{O}(n2^n)$。
- 空间复杂度：$\mathcal{O}(n)$。返回值的空间不计。

## 方法三：二进制枚举

根据 [从集合论到位运算，常见位运算技巧分类总结](https://leetcode.cn/circle/discuss/CaOJ45/) 中的「枚举子集」的技巧，可以只用简单的循环枚举所有子集。

```py [sol-Python3]
class Solution:
    def subsets(self, nums: List[int]) -> List[List[int]]:
        ans = []
        for i in range(1 << len(nums)):  # 枚举全集 U 的所有子集 i
            subset = [x for j, x in enumerate(nums) if i >> j & 1]
            ans.append(subset)
        return ans
```

```java [sol-Java]
class Solution {
    public List<List<Integer>> subsets(int[] nums) {
        int n = nums.length;
        List<List<Integer>> ans = new ArrayList<>(1 << n); // 预分配空间
        for (int i = 0; i < (1 << n); i++) { // 枚举全集 U 的所有子集 i
            List<Integer> subset = new ArrayList<>();
            for (int j = 0; j < n; j++) {
                if ((i >> j & 1) == 1) { // j 在集合 i 中
                    subset.add(nums[j]);
                }
            }
            ans.add(subset);
        }
        return ans;
    }
}
```

```cpp [sol-C++]
class Solution {
public:
    vector<vector<int>> subsets(vector<int>& nums) {
        int n = nums.size();
        vector<vector<int>> ans(1 << n);
        for (int i = 0; i < (1 << n); i++) { // 枚举全集 U 的所有子集 i
            for (int j = 0; j < n; j++) {
                if (i >> j & 1) { // j 在集合 i 中
                    ans[i].push_back(nums[j]);
                }
            }
        }
        return ans;
    }
};
```

```go [sol-Go]
func subsets(nums []int) [][]int {
    ans := make([][]int, 1<<len(nums))
    for i := range ans { // 枚举全集 U 的所有子集 i
        for j, x := range nums {
            if i>>j&1 == 1 { // j 在集合 i 中
                ans[i] = append(ans[i], x)
            }
        }
    }
    return ans
}
```

```js [sol-JavaScript]
var subsets = function(nums) {
    const n = nums.length;
    const ans = [];
    for (let i = 0; i < (1 << n); i++) { // 枚举全集 U 的所有子集 i
        const subset = [];
        for (let j = 0; j < n; j++) {
            if (i >> j & 1) { // j 在集合 i 中
                subset.push(nums[j]);
            }
        }
        ans.push(subset);
    }
    return ans;
};
```

```rust [sol-Rust]
impl Solution {
    pub fn subsets(nums: Vec<i32>) -> Vec<Vec<i32>> {
        (0..1 << nums.len()).map(|i| {
            nums.iter()
                .enumerate()
                .filter_map(|(j, &x)| ((i >> j) & 1 == 1).then_some(x))
                .collect()
        }).collect()
    }
}
```

#### 复杂度分析

- 时间复杂度：$\mathcal{O}(n2^n)$，其中 $n$ 为 $\textit{nums}$ 的长度。
- 空间复杂度：$\mathcal{O}(1)$。返回值的空间不计。

## 分类题单

[如何科学刷题？](https://leetcode.cn/discuss/post/3141566/ru-he-ke-xue-shua-ti-by-endlesscheng-q3yd/)

1. [滑动窗口与双指针（定长/不定长/单序列/双序列/三指针/分组循环）](https://leetcode.cn/discuss/post/3578981/ti-dan-hua-dong-chuang-kou-ding-chang-bu-rzz7/)
2. [二分算法（二分答案/最小化最大值/最大化最小值/第K小）](https://leetcode.cn/discuss/post/3579164/ti-dan-er-fen-suan-fa-er-fen-da-an-zui-x-3rqn/)
3. [单调栈（基础/矩形面积/贡献法/最小字典序）](https://leetcode.cn/discuss/post/3579480/ti-dan-dan-diao-zhan-ju-xing-xi-lie-zi-d-u4hk/)
4. [网格图（DFS/BFS/综合应用）](https://leetcode.cn/discuss/post/3580195/fen-xiang-gun-ti-dan-wang-ge-tu-dfsbfszo-l3pa/)
5. [位运算（基础/性质/拆位/试填/恒等式/思维）](https://leetcode.cn/discuss/post/3580371/fen-xiang-gun-ti-dan-wei-yun-suan-ji-chu-nth4/)
6. [图论算法（DFS/BFS/拓扑排序/基环树/最短路/最小生成树/网络流）](https://leetcode.cn/discuss/post/3581143/fen-xiang-gun-ti-dan-tu-lun-suan-fa-dfsb-qyux/)
7. [动态规划（入门/背包/划分/状态机/区间/状压/数位/数据结构优化/树形/博弈/概率期望）](https://leetcode.cn/discuss/post/3581838/fen-xiang-gun-ti-dan-dong-tai-gui-hua-ru-007o/)
8. [常用数据结构（前缀和/差分/栈/队列/堆/字典树/并查集/树状数组/线段树）](https://leetcode.cn/discuss/post/3583665/fen-xiang-gun-ti-dan-chang-yong-shu-ju-j-bvmv/)
9. [数学算法（数论/组合/概率期望/博弈/计算几何/随机算法）](https://leetcode.cn/discuss/post/3584388/fen-xiang-gun-ti-dan-shu-xue-suan-fa-shu-gcai/)
10. [贪心与思维（基本贪心策略/反悔/区间/字典序/数学/思维/脑筋急转弯/构造）](https://leetcode.cn/discuss/post/3091107/fen-xiang-gun-ti-dan-tan-xin-ji-ben-tan-k58yb/)
11. [链表、树与回溯（前后指针/快慢指针/DFS/BFS/直径/LCA）](https://leetcode.cn/discuss/post/3142882/fen-xiang-gun-ti-dan-lian-biao-er-cha-sh-6srp/)
12. [字符串（KMP/Z函数/Manacher/字符串哈希/AC自动机/后缀数组/子序列自动机）](https://leetcode.cn/discuss/post/3144832/fen-xiang-gun-ti-dan-zi-fu-chuan-kmpzhan-ugt4/)

[我的题解精选（已分类）](https://github.com/EndlessCheng/codeforces-go/blob/master/leetcode/SOLUTIONS.md)

欢迎关注 [B站@灵茶山艾府](https://space.bilibili.com/206214)

## 本地原创解析

### 1. 题意重述

本题来自 `四、回溯 / §4.2 子集型回溯`。先把题目抽象为该分类下的标准模型：确定要维护的对象、合法状态和答案更新时机，再用来源题解正文校准细节。

### 2. 暴力思路与瓶颈

直接枚举所有候选并逐个重新计算属性，通常会产生 $O(nk)$、$O(n^2)$ 或更高复杂度。瓶颈在于相邻候选之间有大量重复计算。

### 3. 关键观察

相邻状态通常只差少量元素或一个转移边界。只要把重复计算沉淀为可增量维护的统计量、单调结构、状态转移或图搜索标记，就能显著降低复杂度。

### 4. 算法设计

1. 根据题目约束确定窗口、前缀、二分、栈、图搜索、动态规划或数学变换的核心状态。
2. 初始化边界状态。
3. 按来源分类的套路推进枚举或转移，并在状态合法时更新答案。
4. 对边界不足、空状态、重复元素、负数、溢出、取模和不可达状态单独处理。

### 5. 正确性说明

枚举或转移过程覆盖所有合法候选；维护量在每一步与当前候选状态保持一致；答案只在候选合法或状态最优性成立时更新，因此最终结果等于所有合法候选的最优值、计数或可行性判断。

### 6. 复杂度分析

- 时间复杂度：依据具体题解正文确认；常见为 $O(n)$、$O(n\log n)$、$O(nm)$ 或状态数乘转移数。
- 空间复杂度：依据维护状态确认；常见为 $O(1)$、$O(k)$、$O(n)$ 或 DP/图状态规模。

### 7. C++17 实现

```cpp
#include <bits/stdc++.h>
using namespace std;

class Solution {
public:
    // TODO: 根据题目签名补全。当前批次先建立详解结构，代码需按题面签名复核。
};
```

### 8. 样例推演

当前本地层不复制题面样例。导入授权题解正文后，应结合正文中的示例或手工构造小样例，列出状态变化和答案更新时机。

### 9. 易错点

- 更新答案前必须确认当前状态已经合法。
- 删除、回退或转移状态时不要漏更新计数、和、频率表、访问标记或单调结构。
- 若题目含负数、重复值、空集合、取模、长整型溢出或特殊图结构，需单独核对边界。

### 10. 扩展解析

同一分类下的题目通常共享维护框架，差异主要在状态定义和合法性条件。复盘时应总结“状态是什么、何时合法、如何转移、答案如何更新”。

### 11. 同类题迁移

回到来源分类 `四、回溯 / §4.2 子集型回溯`，选择同小节后续题目训练。若新题只是维护量变化，优先复用当前框架；若合法性条件变化，再调整枚举顺序、收缩策略或状态转移。
