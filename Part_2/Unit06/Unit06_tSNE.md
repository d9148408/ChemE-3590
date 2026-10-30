# Unit06 t-分布隨機鄰域嵌入 (t-distributed Stochastic Neighbor Embedding, t-SNE)

## 課程目標

本單元將深入介紹 t-分布隨機鄰域嵌入 (t-distributed Stochastic Neighbor Embedding, t-SNE)，這是一種專門為高維數據視覺化設計的非線性降維技術。t-SNE 能夠有效地將高維數據映射到 2D 或 3D 空間，同時保持數據點之間的局部相似性結構，使得相似的數據點在低維空間中彼此接近。在化工領域中，t-SNE 特別適合用於探索複雜製程數據的內在結構、識別不同操作模式，以及視覺化高維品質數據的分布模式。透過本單元的學習，您將能夠：

- 理解 t-SNE 的核心原理與數學基礎
- 掌握 t-SNE 與 PCA、Kernel PCA 的差異
- 學會使用 scikit-learn 實作 t-SNE 模型
- 了解如何調整 t-SNE 的關鍵超參數
- 學會解讀 t-SNE 視覺化結果的注意事項
- 認識 t-SNE 的優缺點與適用場景
- 應用 t-SNE 於化工領域的高維數據視覺化

---

## 1. t-SNE 演算法簡介

### 1.1 什麼是 t-SNE？

t-分布隨機鄰域嵌入 (t-SNE) 是由 Laurens van der Maaten 和 Geoffrey Hinton 於 2008 年提出的一種非線性降維技術，主要用於高維數據的視覺化。與 PCA 等線性降維方法不同，t-SNE 能夠揭示數據的非線性結構，特別擅長保持數據點之間的**局部相似性關係**。

**核心理念**：
- 在高維空間中，計算數據點之間的相似度（使用高斯分布）
- 在低維空間中，計算數據點之間的相似度（使用 t-分布）
- 透過最小化兩個分布之間的 KL 散度，調整低維空間中點的位置
- 使得高維空間中相近的點在低維空間中也保持相近

**與其他降維方法的比較**：
- **PCA**：線性降維，保留全局變異數，快速但無法捕捉非線性結構
- **Kernel PCA**：非線性降維，但仍以變異數最大化為目標
- **t-SNE**：非線性降維，專注於保持局部鄰域結構，適合視覺化

**t-SNE 的優勢**：
- 能夠發現複雜的非線性結構
- 在 2D/3D 視覺化中表現優異
- 對於群集結構的呈現效果極佳
- 對群集形狀與密度的差異較寬容（但群集大小在圖中不具意義）

**t-SNE 的限制**：
- 計算成本高，不適合大規模數據（需要預先降維）
- 結果受超參數影響大，需要仔細調整
- 不保留全局結構（距離的絕對值無意義）
- 每次運行結果可能不同（隨機初始化）
- 不能用於新數據的投影（需重新運行）

### 1.2 t-SNE 的發展歷史

**SNE (Stochastic Neighbor Embedding)**：
- 2002 年由 Hinton 和 Roweis 提出
- 使用高斯分布建模高維和低維空間的相似度
- 存在「擁擠問題」(Crowding Problem)：低維空間無法容納所有相似點

**t-SNE 的改進**：
- 2008 年引入 t-分布解決擁擠問題
- t-分布的長尾特性允許中等距離的點在低維空間中分得更開
- 使用對稱 SNE 簡化梯度計算
- 引入早期誇大 (Early Exaggeration) 技術避免局部最優

**後續發展**：
- Barnes-Hut t-SNE (2013)：使用樹結構加速計算， $O(N \log N)$ 複雜度
- Multicore t-SNE：利用多核心平行計算
- UMAP (2018)：基於流形理論的改進方法，更快且保留更多全局結構

### 1.3 化工領域應用案例

t-SNE 在化工領域有以下重要應用：

1. **多變數製程狀態視覺化**：
   - 將數十個感測器變數降至 2D 空間視覺化
   - 識別不同的操作模式與狀態轉換
   - 發現異常操作條件與製程漂移
   - 監控製程的動態行為

2. **產品品質數據探索**：
   - 視覺化高維品質指標的分布
   - 識別不同品質等級的群集
   - 發現影響品質的關鍵因素
   - 探索產品配方與品質的關聯

3. **批次製程軌跡視覺化**：
   - 比較不同批次的演化軌跡
   - 識別成功與失敗批次的差異
   - 發現批次間的相似性與差異性
   - 優化批次操作策略

4. **高維光譜數據分析**：
   - 視覺化 NIR、Raman、IR 等光譜數據
   - 識別化合物的群集與分類
   - 發現光譜特徵與組成的關聯
   - 支援化學計量學分析

5. **反應條件與產物關聯探索**：
   - 視覺化高維反應條件空間
   - 發現最優反應區域
   - 探索反應條件與產物分布的關係
   - 輔助實驗設計 (DOE)

---

## 2. t-SNE 演算法原理

### 2.1 問題定義

給定高維數據 $\mathbf{X} = \{\mathbf{x}_1, \mathbf{x}_2, \ldots, \mathbf{x}_n\}$ ，其中 $\mathbf{x}_i \in \mathbb{R}^D$ ，目標是找到低維表示 $\mathbf{Y} = \{\mathbf{y}_1, \mathbf{y}_2, \ldots, \mathbf{y}_n\}$ ，其中 $\mathbf{y}_i \in \mathbb{R}^d$ （通常 $d = 2$ 或 $d = 3$ ），使得：

- 在高維空間中相似的點在低維空間中也相似
- 在高維空間中不相似的點在低維空間中也不相似

### 2.2 高維空間中的相似度：條件機率

在高維空間中，點 $\mathbf{x}_j$ 相對於點 $\mathbf{x}_i$ 的相似度定義為條件機率 $p_{j|i}$ ：

$$
p_{j|i} = \frac{\exp\left(-\|\mathbf{x}_i - \mathbf{x}_j\|^2 / 2\sigma_i^2\right)}{\sum_{k \neq i} \exp\left(-\|\mathbf{x}_i - \mathbf{x}_k\|^2 / 2\sigma_i^2\right)}
$$

其中 $\sigma_i$ 是以點 $\mathbf{x}_i$ 為中心的高斯核的帶寬（標準差）。

**直觀理解**：
- 使用高斯核將距離轉換為相似度
- 距離越近，相似度越高
- 每個點有自己的 $\sigma_i$ ，適應局部密度差異

**對稱化**：

為了簡化計算，t-SNE 使用對稱的聯合機率：

$$
p_{ij} = \frac{p_{j|i} + p_{i|j}}{2n}
$$

確保 $p_{ij} = p_{ji}$ 且 $\sum_{i,j} p_{ij} = 1$ 。

### 2.3 困惑度 (Perplexity) 與 $\sigma_i$ 的選擇

困惑度 (Perplexity) 是用來自動決定每個點的 $\sigma_i$ 的超參數，定義為：

$$
\text{Perp}(P_i) = 2^{H(P_i)}
$$

其中 $H(P_i)$ 是條件分布 $P_i$ 的熵：

$$
H(P_i) = -\sum_{j \neq i} p_{j|i} \log_2 p_{j|i}
$$

**直觀理解**：
- 困惑度可以解釋為「有效鄰居數量」
- 較小的困惑度（5-15）：關注更局部的結構
- 較大的困惑度（50-100）：關注更全局的結構
- 典型值：30（建議在 5-50 之間嘗試）

**σᵢ 的自動選擇**：

對於給定的困惑度，使用二分搜尋法找到使得 $\text{Perp}(P_i)$ 等於目標困惑度的 $\sigma_i$ 。

### 2.4 低維空間中的相似度：t-分布

在低維空間中，點 $\mathbf{y}_j$ 相對於點 $\mathbf{y}_i$ 的相似度定義為：

$$
q_{ij} = \frac{\left(1 + \|\mathbf{y}_i - \mathbf{y}_j\|^2\right)^{-1}}{\sum_{k \neq l} \left(1 + \|\mathbf{y}_k - \mathbf{y}_l\|^2\right)^{-1}}
$$

**為什麼使用 t-分布（自由度為 1 的 Student-t 分布）？**

1. **解決擁擠問題 (Crowding Problem)**：
   - 高維空間中的中等距離點在低維空間中沒有足夠的空間容納
   - t-分布的長尾特性允許這些點在低維空間中分得更開
   - 高斯分布衰減太快，導致擁擠

2. **數學性質**：
   - t-分布（自由度 1）等價於 Cauchy 分布
   - 長尾特性：離群點不會被過度懲罰
   - 梯度計算簡單且數值穩定

**對比高斯分布**：
- 高維：高斯核 → 短尾，局部敏感
- 低維：t-分布 → 長尾，避免擁擠

### 2.5 目標函數：KL 散度

t-SNE 的目標是最小化高維分布 $P$ 和低維分布 $Q$ 之間的 Kullback-Leibler (KL) 散度：

$$
\text{KL}(P \| Q) = \sum_{i \neq j} p_{ij} \log \frac{p_{ij}}{q_{ij}}
$$

**KL 散度的性質**：
- 非對稱： $\text{KL}(P \| Q) \neq \text{KL}(Q \| P)$
- 總是非負： $\text{KL}(P \| Q) \geq 0$ 
- 當 $P = Q$ 時達到最小值 0

**為什麼使用 KL(P||Q) 而不是 KL(Q||P)？**

- $\text{KL}(P \| Q)$ ：當 $p_{ij}$ 大而 $q_{ij}$ 小時（高維中相近的點在低維中被分開），懲罰非常大，因此強制保持局部鄰近關係
- $\text{KL}(Q \| P)$ ：當 $q_{ij}$ 大而 $p_{ij}$ 小時（高維中遠離的點在低維中被拉近）才會被重罰，反而容許相近的點被拆開，不利於保持局部結構

因此， $\text{KL}(P \| Q)$ 更適合保持局部相似性結構。代價是：高維中不相似的點（ $p_{ij}$ 小）即使在低維中被放得很近（ $q_{ij}$ 大），懲罰也很輕，所以群集之間的距離不可靠。

### 2.6 梯度下降優化

t-SNE 使用梯度下降法優化低維嵌入 $\mathbf{Y}$ ：

$$
\frac{\partial \text{KL}(P \| Q)}{\partial \mathbf{y}_i} = 4 \sum_{j} (p_{ij} - q_{ij})(\mathbf{y}_i - \mathbf{y}_j)\left(1 + \|\mathbf{y}_i - \mathbf{y}_j\|^2\right)^{-1}
$$

**梯度的物理意義**：
- 正項 $p_{ij}$ ：吸引力，將相似的點拉近
- 負項 $q_{ij}$ ：排斥力，將不相似的點推開
- 權重 $(1 + \|\mathbf{y}_i - \mathbf{y}_j\|^2)^{-1}$ ：距離越遠，作用越小

**優化技巧**：

1. **動量 (Momentum)**：
   - 加速收斂，避免震盪
   - 典型值：0.5（前 250 次迭代），0.8（後續迭代）

2. **早期誇大 (Early Exaggeration)**：
   - 在初期將 $p_{ij}$ 放大（原論文乘以 4，scikit-learn 預設為 12）
   - 鼓勵群集形成緊密的團塊，避免陷入局部最優
   - 典型期間：前 250 次迭代

3. **學習率 (Learning Rate)**：
   - 控制每次更新的步長
   - 太大：不穩定，太小：收斂慢
   - 典型值：100-1000（建議從 200 開始）

### 2.7 t-SNE 演算法流程

**完整演算法步驟**：

1. **計算高維空間中的相似度**：
   - 對於每個數據點 $\mathbf{x}_i$ ，根據給定的困惑度計算 $\sigma_i$
   - 計算條件機率 $p_{j|i}$
   - 對稱化得到 $p_{ij}$

2. **初始化低維嵌入**：
   - 隨機初始化 $\mathbf{Y}$ （通常使用小方差的高斯分布）
   - 或使用 PCA 結果作為初始化（更穩定）

3. **迭代優化**：
   - 計算低維空間中的相似度 $q_{ij}$
   - 計算梯度 $\frac{\partial \text{KL}}{\partial \mathbf{y}_i}$
   - 使用動量梯度下降更新 $\mathbf{Y}$
   - 重複直到收斂或達到最大迭代次數

4. **返回最終嵌入**：
   - 輸出優化後的低維表示 $\mathbf{Y}$

**計算複雜度**：
- 標準 t-SNE： $O(N^2)$ （ $N$ 是樣本數）
- Barnes-Hut t-SNE： $O(N \log N)$ （使用四叉樹/八叉樹加速）

---

## 3. t-SNE 的關鍵超參數

### 3.1 困惑度 (Perplexity)

**定義**：困惑度控制了 t-SNE 在優化時關注局部還是全局結構，可解釋為「每個點的有效近鄰數量」。

**影響**：
- **小困惑度（5-15）**：
  - 關注非常局部的結構
  - 產生更多、更小的群集
  - 對噪音敏感
  - 可能過度強調局部變化

- **中等困惑度（30-50）**：
  - 平衡局部與全局結構
  - 最常用的範圍
  - 通常效果最好

- **大困惑度（50-100）**：
  - 關注更全局的結構
  - 產生較少、較大的群集
  - 可能忽略局部細節
  - 計算成本更高

**選擇建議**：
- 默認值：30（適合大多數情況）
- 小數據集（< 1000 樣本）：5-30
- 大數據集（> 10000 樣本）：30-50
- 建議嘗試多個值（如 5, 30, 50）並比較結果

**數學關係**：
- 困惑度必須小於樣本數： $\text{Perplexity} < N$
- 推薦範圍： $5 \leq \text{Perplexity} \leq 50$

### 3.2 學習率 (Learning Rate)

**定義**：控制梯度下降的步長，影響優化速度與最終結果。

**影響**：
- **太小（< 10）**：
  - 收斂非常慢
  - 多數點壓縮成一團緻密的雲，只有少數離群點
  - 無法充分展開群集

- **適中（100-1000）**：
  - 收斂速度合理
  - 群集結構清晰
  - 最常用的範圍

- **太大（> 1000）**：
  - 優化不穩定
  - 嵌入常呈現「球狀」，每個點與其最近鄰的距離幾乎相等（scikit-learn 官方說明）
  - 群集結構消失

**選擇建議**：
- 默認值：200（sklearn 使用 'auto'）
- 小數據集：10-100
- 大數據集：100-1000
- 如果結果呈現球狀、點與點距離幾乎相等 → 降低學習率
- 如果結果壓縮成一團緻密的雲、只有少數離群點 → 提高學習率

**Sklearn 的 'auto' 模式**：
- 自動設置為 $\text{learning\_rate} = \max(N / \text{early\_exaggeration} / 4, 50)$ ，預設 early_exaggeration=12，即 $\max(N / 48, 50)$
- 本單元的 $N = 600$ ，計算值為 12.5，因此實際使用下限 50（可由 `tsne.learning_rate_` 查得）

### 3.3 迭代次數 (max_iter)

**定義**：優化算法的總迭代次數（scikit-learn 1.5 起由 `n_iter` 更名為 `max_iter`，1.7 已移除 `n_iter`；最少需 250 次）。

**影響**：
- **太少（< 250）**：
  - 優化不充分
  - 群集結構不清晰
  - 可能陷入局部最優

- **適中（1000-5000）**：
  - 通常能充分收斂
  - 群集結構穩定
  - 最常用的範圍

- **太多（> 5000）**：
  - 收益遞減
  - 計算成本高
  - 可能過度優化局部細節

**選擇建議**：
- 默認值：1000（sklearn）
- 小數據集：250-1000
- 大數據集：1000-5000
- 實際執行次數可由 `n_iter_` 查得；跑滿 `max_iter` 時 `n_iter_` 為 `max_iter - 1`（例如 999）
- 監控 KL 散度的變化判斷是否收斂

### 3.4 初始化方法 (init)

**定義**：低維嵌入的初始化方式。

**選項**：

1. **'random'**：
   - 從小方差高斯分布隨機初始化
   - 每次運行結果可能不同
   - 需要更多迭代次數

2. **'pca'**：
   - 使用 PCA 的前幾個主成分初始化
   - 結果更穩定、可重複
   - 收斂更快
   - sklearn 默認選項

**選擇建議**：
- 推薦使用 'pca'（更穩定）
- 探索性分析可嘗試多次 'random' 初始化

### 3.5 其他重要參數

**early_exaggeration**：
- 定義：早期迭代中放大 $p_{ij}$ 的因子
- 默認值：12.0
- 作用：幫助形成緊密的群集，避免局部最優
- 通常不需要調整

**min_grad_norm**：
- 定義：梯度範數的最小閾值，低於此值時停止優化
- 默認值： `1e-7`
- 作用：提前停止條件
- 通常不需要調整

**metric**：
- 定義：計算高維空間距離的度量方式
- 默認值：'euclidean'
- 其他選項：'manhattan', 'cosine', 'correlation' 等
- 化工應用：通常使用 'euclidean'

**method**：
- 定義：計算方法
- 選項：
  - 'barnes_hut'：使用 Barnes-Hut 近似，速度快，適合大數據
  - 'exact'：精確計算，速度慢，適合小數據（< 1000 樣本）
- sklearn 默認：'barnes_hut'

**angle**（僅用於 barnes_hut）：
- 定義：Barnes-Hut 算法的角度閾值
- 默認值：0.5
- 較小值：更精確但更慢
- 較大值：更快但精度降低
- 範圍：0.0-1.0

---

## 4. t-SNE 的優缺點與適用場景

### 4.1 t-SNE 的優勢

**1. 優秀的視覺化效果**：
- 能夠生成清晰、直觀的 2D/3D 視覺化結果
- 群集結構在視覺上非常明顯
- 相似的數據點聚集在一起，不相似的點分離

**2. 保持局部結構**：
- 有效保留數據的局部鄰域關係
- 相似的數據點在低維空間中保持接近
- 適合發現數據的局部模式與群集

**3. 處理非線性結構**：
- 能夠捕捉複雜的非線性關係
- 適用於彎曲、螺旋等複雜流形結構
- 比線性降維方法（如 PCA）更靈活

**4. 對群集密度差異較寬容**：
- t-分布的長尾特性緩解擁擠問題，讓群集更容易分開
- 每個點的高斯帶寬由困惑度自動調整，能適應局部密度的差異
- 注意：結果中的群集大小與密度不能解讀為原始空間的群集大小或密度

**5. 無監督學習**：
- 不需要標籤信息
- 可用於探索性數據分析
- 發現未知的數據結構與模式

### 4.2 t-SNE 的局限性

**1. 計算成本高**：
- 標準 t-SNE： $O(N^2)$ 時間複雜度和空間複雜度
- 不適合大規模數據（> 10000 樣本）
- 需要長時間迭代（通常 1000+ 次）
- **解決方案**：使用 Barnes-Hut t-SNE 或 UMAP

**2. 不保留全局結構**：
- 只關注局部鄰域關係
- 群集之間的距離無意義
- 不同群集的相對位置可能誤導
- **注意**：不能根據群集間距離推斷相似性

**3. 超參數敏感**：
- 困惑度、學習率等參數對結果影響大
- 不同參數可能產生完全不同的結果
- 需要嘗試多個參數組合
- 缺乏統一的選擇準則

**4. 結果不確定性**：
- 隨機初始化導致每次運行結果不同
- 可能陷入不同的局部最優
- 無法保證可重複性（除非固定隨機種子）
- **解決方案**：使用 PCA 初始化或多次運行比較

**5. 無法投影新數據**：
- t-SNE 不是參數化模型
- 無法將新數據點投影到已有的嵌入空間
- 每次新增數據需要重新運行
- **對比**：PCA 可以輕鬆投影新數據

**6. 無明確的目標函數收斂標準**：
- KL 散度可能在局部波動
- 難以判斷何時停止迭代
- 可能需要視覺檢查判斷是否收斂

**7. 可解釋性有限**：
- t-SNE 軸（嵌入維度）沒有明確的物理意義
- 不像 PCA 的主成分可以解釋為原始特徵的線性組合
- 難以進行定量分析

### 4.3 t-SNE 適用場景

**最適合的應用**：

1. **高維數據的探索性視覺化**：
   - 製程數據的初步探索
   - 產品品質數據的分布視覺化
   - 發現未知的數據模式

2. **群集結構的視覺化呈現**：
   - 展示不同操作模式的分離
   - 視覺化分群結果的品質
   - 識別異常樣本或離群點

3. **非線性降維需求**：
   - 數據存在明顯的非線性關係
   - PCA 或線性方法效果不佳
   - 需要捕捉複雜的流形結構

4. **多模態數據的視覺化**：
   - 批次製程的多個操作階段
   - 多產品的品質分布
   - 不同配方的效果比較

**不適合的應用**：

1. **大規模數據分析**：
   - 樣本數 > 10000（考慮使用 UMAP 或 PCA）
   - 實時監控系統（計算太慢）
   - 需要頻繁更新的應用

2. **需要投影新數據**：
   - 在線監控系統（無法投影新點）
   - 預測模型的特徵工程（使用 PCA）
   - 測試數據的降維（t-SNE 無此功能）

3. **需要保留全局結構**：
   - 群集間的相對關係很重要
   - 需要量化群集間的距離
   - 全局拓撲結構分析

4. **需要可解釋性**：
   - 需要理解降維後維度的物理意義
   - 需要定量分析特徵貢獻
   - 需要向非技術人員解釋結果

5. **需要可重複性與穩定性**：
   - 監管報告（需要完全相同的結果）
   - A/B 測試比較（結果隨機性影響判斷）
   - 需要標準化流程的應用

### 4.4 t-SNE 與其他降維方法的比較

| 特性 | t-SNE | PCA | Kernel PCA | UMAP |
|------|-------|-----|------------|------|
| **降維類型** | 非線性 | 線性 | 非線性 | 非線性 |
| **保留結構** | 局部 | 全局 | 全局 | 局部+全局 |
| **計算複雜度** | $O(N^2)$ （Barnes-Hut： $O(N \log N)$ ） | $O(Nd^2)$ | $O(N^2)$ ~ $O(N^3)$ | $O(N \log N)$ |
| **大數據適用性** | ❌ | ✅ | ❌ | ✅ |
| **視覺化效果** | 優秀 | 中等 | 良好 | 優秀 |
| **超參數敏感** | 高 | 低 | 中 | 中 |
| **可解釋性** | 低 | 高 | 中 | 低 |
| **投影新數據** | ❌ | ✅ | ✅ | ✅（有限，透過 `transform`） |
| **確定性** | 隨機 | 確定 | 確定 | 隨機 |
| **訓練速度** | 慢 | 快 | 中 | 快 |
| **化工應用** | 視覺化探索 | 製程監控 | 非線性特徵 | 大規模視覺化 |

**選擇建議**：
- **探索性視覺化**：t-SNE（小數據）或 UMAP（大數據）
- **製程監控與故障診斷**：PCA（可投影新數據，可解釋）
- **非線性特徵提取**：Kernel PCA（保留全局結構）
- **大規模視覺化**：UMAP（速度快，效果好）
- **需要可解釋性**：PCA（明確的物理意義）

---

## 5. t-SNE 與 PCA 的對比分析

### 5.1 方法論差異

| 對比維度 | PCA | t-SNE |
|---------|-----|-------|
| **數學基礎** | 特徵值分解 / SVD | 概率分布匹配（KL散度） |
| **目標函數** | 最大化變異數 | 最小化高低維分布差異 |
| **降維方式** | 線性投影 | 非線性映射 |
| **優化方法** | 解析解（直接計算） | 梯度下降（迭代優化） |
| **距離度量** | 歐式距離（全局） | 概率相似度（局部） |

### 5.2 性能與效率對比

| 對比維度 | PCA | t-SNE |
|---------|-----|-------|
| **訓練時間** | 秒級（N=10000） | 分鐘級（N=10000） |
| **內存需求** | 低 | 高 |
| **可擴展性** | 優秀（可處理百萬級樣本） | 有限（建議<10000樣本） |
| **增量學習** | ✅ 支持 | ❌ 不支持 |
| **並行計算** | ✅ 容易 | 🟡 困難 |

### 5.3 結果特性對比

| 對比維度 | PCA | t-SNE |
|---------|-----|-------|
| **保留結構** | 全局變異數 | 局部相似性 |
| **群集分離** | 可能重疊 | 清晰分離 |
| **距離意義** | 保留 | 僅局部有意義 |
| **軸意義** | 有明確物理意義 | 無明確意義 |
| **可重複性** | ✅ 確定性結果 | 🟡 隨機性（需固定種子） |
| **新數據投影** | ✅ 容易 | ❌ 不可能 |

### 5.4 化工應用對比

**PCA 更適合**：
- ✅ 製程監控與故障診斷（需要投影新數據、可解釋的主成分）
- ✅ 軟感測器開發（需要線性特徵轉換）
- ✅ 大規模數據分析（高效率）
- ✅ 實時系統（快速計算）
- ✅ 需要定量分析（變異數貢獻、Loadings解釋）

**t-SNE 更適合**：
- ✅ 探索性數據分析（發現未知模式）
- ✅ 操作模式的視覺化（清晰的群集分離）
- ✅ 非線性關係探索（複雜的化學反應系統）
- ✅ 小規模高維數據（高維光譜、配方數據）
- ✅ 研究報告與論文（精美的視覺化圖表）

**組合使用策略**：

```
高維數據（D > 50）
    ↓
先用 PCA 降至 30-50 維（快速去噪、降低計算成本）
    ↓
再用 t-SNE 降至 2D/3D（視覺化探索）
```

**好處**：
- 加速 t-SNE 計算（距離計算成本由 $O(N^2 D)$ 降為 $O(N^2 d)$ ，其中 $d \ll D$ 為 PCA 保留的維度）
- 去除噪音維度（PCA 保留主要變異數）
- 提升 t-SNE 視覺化品質（減少無關信息干擾）

### 5.5 實際案例對比

**案例：反應器操作模式識別**

| 方法 | 結果描述 |
|-----|---------|
| **PCA (2D)** | 前兩個主成分累積解釋約 87% 變異數，本例三群已清楚分開，且沿 PC1 依 A→C→B 排序，保留群集間的相對距離；若群集呈非線性結構，則可能重疊 |
| **t-SNE (2D)** | 三群同樣清楚分離，且群集更緊密；但群集間距離與群集大小不具定量意義 |
| **結論** | 群集尺度較大、結構簡單時，PCA 已足夠；t-SNE 的優勢在非線性、群集相近或從屬層級的複雜數據 |

**案例：製程故障診斷**

| 方法 | 結果描述 |
|-----|---------|
| **PCA** | 可建立 T²、SPE 控制圖，實時監控新數據，明確指出異常變數 |
| **t-SNE** | 可視覺化故障模式的分布，但無法投影新數據點，不適合實時監控 |
| **結論** | PCA 是製程監控的首選，t-SNE 僅用於歷史故障模式的探索 |

---

## 6. 使用 scikit-learn 實作 t-SNE

### 6.1 t-SNE 類別簡介

scikit-learn 提供 `sklearn.manifold.TSNE` 類別實現 t-SNE 降維。

**主要參數**：

```python
from sklearn.manifold import TSNE

tsne = TSNE(
    n_components=2,           # 降維後的維度（通常 2 或 3）
    perplexity=30.0,          # 困惑度（5-50）
    early_exaggeration=12.0,  # 早期誇大因子
    learning_rate='auto',     # 學習率（'auto' 或數值）
    max_iter=1000,            # 迭代次數（sklearn < 1.5 的參數名為 n_iter）
    n_iter_without_progress=300,  # 無進展停止閾值
    min_grad_norm=1e-7,       # 梯度範數最小值
    metric='euclidean',       # 距離度量
    init='pca',               # 初始化方法（'pca' 或 'random'）
    verbose=0,                # 輸出詳細信息
    random_state=None,        # 隨機種子
    method='barnes_hut',      # 計算方法
    angle=0.5                 # Barnes-Hut 角度閾值
)
```

### 6.2 基本使用流程

**步驟 1：數據準備與標準化**

```python
from sklearn.preprocessing import StandardScaler

# 標準化數據
scaler = StandardScaler()
X_scaled = scaler.fit_transform(X)
```

**步驟 2：建立 t-SNE 模型**

```python
from sklearn.manifold import TSNE

# 建立模型
tsne = TSNE(
    n_components=2,
    perplexity=30,
    learning_rate='auto',
    max_iter=1000,
    init='pca',
    random_state=42
)
```

**步驟 3：執行降維**

```python
# 執行降維（fit_transform）
X_tsne = tsne.fit_transform(X_scaled)

# 檢查結果形狀
print(f"原始數據形狀: {X_scaled.shape}")
print(f"t-SNE結果形狀: {X_tsne.shape}")
```

**步驟 4：視覺化結果**

```python
import matplotlib.pyplot as plt

plt.figure(figsize=(10, 8))
scatter = plt.scatter(
    X_tsne[:, 0], 
    X_tsne[:, 1], 
    c=labels,  # 如果有標籤，可用於著色
    cmap='viridis', 
    alpha=0.7, 
    edgecolors='k', 
    linewidth=0.5
)
plt.colorbar(scatter, label='Cluster Label')
plt.xlabel('t-SNE Component 1')
plt.ylabel('t-SNE Component 2')
plt.title('t-SNE Visualization')
plt.tight_layout()
plt.show()
```

### 6.3 重要方法與屬性

**fit_transform(X)**：
- 執行降維並返回低維嵌入
- t-SNE 也提供 `fit(X)`（結果存於 `embedding_`），但沒有 `transform()`，因此無法將新數據投影到既有嵌入

```python
X_embedded = tsne.fit_transform(X)
```

**屬性：embedding_**：
- 訓練完成後的低維嵌入結果
- 與 `fit_transform()` 返回值相同

```python
X_embedded = tsne.embedding_
```

**屬性：kl_divergence_**：
- 最終的 KL 散度值
- 用於評估優化品質（僅限相同數據、相同困惑度下比較，越低越好）

```python
print(f"Final KL divergence: {tsne.kl_divergence_:.4f}")
```

**屬性：n_iter_**：
- 最後一次執行的迭代索引；跑滿 `max_iter` 時為 `max_iter - 1`（例如 999）
- 小於 `max_iter - 1` 表示因 `n_iter_without_progress` 或 `min_grad_norm` 提前停止

```python
print(f"Number of iterations: {tsne.n_iter_}")
```

### 6.4 高維數據的預處理：PCA + t-SNE

對於高維數據（D > 50），建議先用 PCA 降維至 30-50 維，再使用 t-SNE。

```python
from sklearn.decomposition import PCA
from sklearn.manifold import TSNE

# 步驟 1：使用 PCA 降至 50 維
pca = PCA(n_components=50, random_state=42)
X_pca = pca.fit_transform(X_scaled)

print(f"PCA 累積解釋變異數: {pca.explained_variance_ratio_.sum():.2%}")

# 步驟 2：對 PCA 結果使用 t-SNE
tsne = TSNE(n_components=2, random_state=42)
X_tsne = tsne.fit_transform(X_pca)
```

**好處**：
- ✅ 大幅減少計算時間
- ✅ 去除噪音維度
- ✅ 提升視覺化品質

### 6.5 多個困惑度的比較

困惑度是 t-SNE 最重要的超參數，建議嘗試多個值。

```python
import matplotlib.pyplot as plt

perplexities = [5, 10, 30, 50, 100]
fig, axes = plt.subplots(1, 5, figsize=(25, 5))

for i, perp in enumerate(perplexities):
    tsne = TSNE(
        n_components=2,
        perplexity=perp,
        learning_rate='auto',
        max_iter=1000,
        init='pca',
        random_state=42
    )
    X_tsne = tsne.fit_transform(X_scaled)
    
    axes[i].scatter(X_tsne[:, 0], X_tsne[:, 1], c=labels, cmap='viridis', alpha=0.7)
    axes[i].set_title(f'Perplexity = {perp}')
    axes[i].set_xlabel('t-SNE 1')
    axes[i].set_ylabel('t-SNE 2')

plt.tight_layout()
plt.show()
```

**觀察要點**：
- 小困惑度：更多、更小的群集
- 大困惑度：更少、更大的群集
- 選擇使視覺化最清晰、群集最合理的值

### 6.6 固定隨機種子確保可重複性

t-SNE 具有隨機性，每次運行結果可能不同。使用 `random_state` 確保可重複性。

```python
import numpy as np

# 同一 random_state 與參數，重複執行會得到相同結果
tsne_1 = TSNE(n_components=2, random_state=42)
X_tsne_1 = tsne_1.fit_transform(X_scaled)

tsne_2 = TSNE(n_components=2, random_state=42)
X_tsne_2 = tsne_2.fit_transform(X_scaled)

print(np.allclose(X_tsne_1, X_tsne_2))  # True
```

**注意**：
- t-SNE 無 `transform()` 方法
- 每次執行 `fit_transform()` 都是全新的優化過程
- 使用相同的 `random_state` 才能得到相同結果

---

## 7. t-SNE 評估指標與診斷

### 7.1 KL 散度 (Kullback-Leibler Divergence)

**定義**：t-SNE 的目標函數，衡量高維和低維分布的差異。

```python
# 訓練後檢查 KL 散度
print(f"Final KL divergence: {tsne.kl_divergence_:.4f}")
```

**解讀**：
- 越低越好，表示低維嵌入與高維相似度匹配得越好
- 本單元 N = 600 的實測值：困惑度 5 → 100 時為 1.04 → 0.27，數值範圍取決於數據與參數，沒有通用的「正常範圍」
- 若多次運行（不同初始化）的 KL 散度差異很大，表示結果不穩定或未收斂

**注意**：
- KL 散度是相對指標，無絕對標準
- **不同困惑度的 KL 散度不可互相比較**：困惑度改變會使高維分布 $P$ 本身改變，KL 通常隨困惑度增加而下降，但這並不代表嵌入品質較好
- 只能用於「相同數據、相同困惑度」下比較不同學習率、初始化或隨機種子

### 7.2 視覺化品質評估

t-SNE 的主要評估方式是視覺檢查，關注以下要點：

**1. 群集分離清晰度**：
- ✅ 好的結果：不同群集清晰分離，邊界明顯
- ❌ 差的結果：群集重疊嚴重，無法區分

**2. 群集緊密度**：
- ✅ 好的結果：同一群集內點聚集緊密
- ❌ 差的結果：群集內點分散，結構鬆散

**3. 局部結構保持**：
- ✅ 好的結果：已知相似的樣本在低維空間中相近
- ❌ 差的結果：相似樣本被分離到不同區域

**4. 無明顯人工痕跡**：
- ✅ 好的結果：群集形狀自然，符合數據特性
- ❌ 差的結果：過於規則的幾何形狀（如規則的網格）

**5. 穩定性檢驗**：
- 多次運行（不同 random_state）結果應大致相似
- 主要群集結構應保持一致（位置可能旋轉/翻轉）

### 7.3 困惑度的影響診斷

**實驗設計**：在相同數據上測試多個困惑度值。

```python
perplexities = [5, 10, 30, 50, 100]

for perp in perplexities:
    tsne = TSNE(n_components=2, perplexity=perp, random_state=42)
    X_tsne = tsne.fit_transform(X_scaled)
    
    print(f"Perplexity = {perp}:")
    print(f"  KL divergence: {tsne.kl_divergence_:.4f}")
    print(f"  N iterations: {tsne.n_iter_}")
```

**診斷標準**：

| 現象 | 可能原因 | 解決方案 |
|------|---------|---------|
| 困惑度太小：出現大量小群集 | 過度關注局部結構 | 增加困惑度 |
| 困惑度太大：群集過度合併 | 過度關注全局結構 | 降低困惑度 |
| KL 散度異常高 | 未收斂或學習率不當 | 增加迭代次數、調整學習率（同一困惑度下比較） |
| 結果對困惑度極度敏感 | 數據噪音高或樣本不足 | 預處理數據或增加樣本 |

### 7.4 學習率的影響診斷

**實驗設計**：測試不同學習率的效果。

```python
learning_rates = [10, 50, 100, 200, 500, 1000]

for lr in learning_rates:
    tsne = TSNE(n_components=2, learning_rate=lr, random_state=42)
    X_tsne = tsne.fit_transform(X_scaled)
    
    print(f"Learning Rate = {lr}:")
    print(f"  KL divergence: {tsne.kl_divergence_:.4f}")
```

**診斷標準**：

| 現象 | 可能原因 | 解決方案 |
|------|---------|---------|
| 學習率太小：多數點壓縮成一團緻密的雲，僅少數離群點 | 優化不充分，無法展開 | 增加學習率 |
| 學習率太大：呈球狀，點與最近鄰的距離幾乎相等 | 優化不穩定，跳過最優解 | 降低學習率 |
| KL 散度不下降或震盪 | 學習率不當 | 使用 'auto' 或 100-1000 |

### 7.5 收斂性診斷

**檢查迭代次數**：

```python
tsne = TSNE(n_components=2, max_iter=1000, random_state=42)
X_tsne = tsne.fit_transform(X_scaled)

# n_iter_ 跑滿 max_iter 時為 max_iter - 1
if tsne.n_iter_ >= tsne.max_iter - 1:
    print("Reached maximum iterations (may need more iterations)")
else:
    print("Early stopping triggered")
```

**診斷標準**：
- 如果 `n_iter_` < `max_iter - 1`：因 `n_iter_without_progress` 或 `min_grad_norm` 提前停止
- 如果 `n_iter_` = `max_iter - 1`：已跑滿最大迭代次數（本單元所有困惑度皆為 999），需以 KL 散度或視覺檢查確認是否已穩定，必要時增加 `max_iter`
- 建議：至少 1000 次迭代，視覺檢查結果是否穩定

**監控 KL 散度變化**（需要自定義實現）：
- 理想情況：KL 散度逐漸下降並趨於穩定
- 問題情況：KL 散度震盪或不下降

### 7.6 與領域知識的一致性驗證

對於有標籤或先驗知識的數據：

**1. 群集與標籤的對應**：
- 已知屬於同一類的樣本是否聚在一起？
- 不同類的樣本是否分離？

```python
# 假設有標籤
from sklearn.metrics import silhouette_score, calinski_harabasz_score

# 計算輪廓係數（使用低維嵌入）
sil_score = silhouette_score(X_tsne, labels)
ch_score = calinski_harabasz_score(X_tsne, labels)

print(f"Silhouette Score: {sil_score:.3f}")
print(f"Calinski-Harabasz Score: {ch_score:.3f}")
```

> 注意：t-SNE 會壓縮群集，這兩項指標在 t-SNE 空間中會被高估；建議同時計算原始空間基準，並搭配 `sklearn.manifold.trustworthiness` 以評估近鄰保留程度。

**2. 化工知識驗證**：
- 視覺化結果是否符合製程物理特性？
- 異常樣本是否被正確識別？
- 不同操作模式是否清晰分離？

---

## 8. t-SNE 實作範例：化工製程視覺化

以下是一個完整的化工製程數據視覺化範例流程。

> **📌 實作說明**：本節內容對應 `Unit06_tSNE.ipynb` 的完整實作範例。所有程式碼已執行完成，以下展示實際執行結果、生成圖表與詳細分析。

### 8.1 數據準備與探索

#### 8.1.1 化工製程數據生成

**模擬情境**：批次反應器多操作模式視覺化

我們模擬一個批次反應器在三種不同操作模式下的數據：
- **模式 A**：低溫低壓操作（低產率，低能耗）
- **模式 B**：高溫高壓操作（高產率，高能耗）
- **模式 C**：中溫中壓操作（中等產率，中等能耗）

每種模式下有 10 個製程變數，各變數在同一模式內為獨立常態分布（共變異數矩陣為對角矩陣），三種模式僅在平均值與標準差上不同。因此本資料集的群集結構明確、各群集的平均值差異大，主要用於示範 t-SNE 的操作流程與結果解讀，並非驗證 t-SNE 能發現複雜非線性結構的案例。

```python
# 設定模擬參數
n_samples_per_mode = 200
n_features = 10

feature_names = [
    'Reactor_Temp',       # 反應器溫度
    'Reactor_Pressure',   # 反應器壓力
    'Feed_Rate',          # 進料速率
    'Cooling_Rate',       # 冷卻速率
    'Stirring_Speed',     # 攪拌速度
    'Reactant_Conc',      # 反應物濃度
    'Product_Yield',      # 產物產率
    'Energy_Consumption', # 能耗
    'Reaction_Time',      # 反應時間
    'pH'                  # pH值
]

mode_names = ['Mode A (Low T/P)', 'Mode B (High T/P)', 'Mode C (Mid T/P)']
mode_colors = ['tab:blue', 'tab:orange', 'tab:green']

# 生成數據後儲存至 data/reactor_operation/reactor_operation_modes.csv
```

**執行結果**：
```
✓ 多操作模式數據生成完成
  總樣本數: 600
  特徵數: 10
  操作模式數: 3
  數據已儲存: ...\Part_2\Unit06\data\reactor_operation\reactor_operation_modes.csv

模式分布:
Mode
Mode A (Low T/P)     200
Mode B (High T/P)    200
Mode C (Mid T/P)     200
Name: count, dtype: int64
```

**數據特性分析**：

1. **樣本平衡性**：
   - 每個操作模式各有 200 個樣本
   - 完全平衡的數據集，無類別不平衡問題
   - 總計 600 個樣本，適合 t-SNE 視覺化

2. **操作模式設計**：
   - **Mode A (低溫低壓)**：
     - 反應器溫度：375K (±10K)
     - 反應器壓力：1.2 bar (±0.1 bar)
     - 產物產率：0.75 (±0.05)
     - 能耗：150 (±15)
     - 反應時間：60 min (±5 min)
     
   - **Mode B (高溫高壓)**：
     - 反應器溫度：475K (±15K)
     - 反應器壓力：2.5 bar (±0.15 bar)
     - 產物產率：0.92 (±0.04)
     - 能耗：350 (±25)
     - 反應時間：45 min (±6 min)
     
   - **Mode C (中溫中壓)**：
     - 反應器溫度：425K (±12K)
     - 反應器壓力：1.8 bar (±0.12 bar)
     - 產物產率：0.83 (±0.045)
     - 能耗：250 (±20)
     - 反應時間：52 min (±5.5 min)

3. **特徵維度**：
   - 10 個製程變數（高維數據）
   - 包含溫度、壓力、流率、濃度、產率等典型化工變數
   - 各變數在同一模式內互相獨立（無相關性），三種模式的平均值在多數變數（溫度、壓力、產率、能耗等）上由低到高為 A < C < B，只有反應時間相反（A > C > B）
   - `Product_Yield` 與 `Energy_Consumption` 本身即為輸入特徵，後續以產率著色時並非獨立驗證

4. **數據標準化**：
```python
from sklearn.preprocessing import StandardScaler

scaler = StandardScaler()
X_scaled = scaler.fit_transform(X)
```

**執行結果**：
```
✓ 數據標準化完成
  標準化後均值: [-1.67847218e-15 -5.34618646e-15 -2.61050441e-15]
  標準化後標準差: [1. 1. 1.]
```

**標準化驗證**：
- 均值接近 0（數值誤差在 $10^{-15}$ 範圍內，可忽略）
- 標準差均為 1
- 所有特徵已正確標準化，消除尺度差異

---

### 8.2 t-SNE 降維與視覺化

#### 8.2.1 不同困惑度的比較

**執行結果**：
```
開始執行 t-SNE（不同困惑度）...
  Perplexity = 5...
    KL divergence: 1.0356, Iterations: 999, Trustworthiness: 0.9695, Time: 2.0 s
  Perplexity = 10...
    KL divergence: 1.0035, Iterations: 999, Trustworthiness: 0.9736, Time: 2.4 s
  Perplexity = 30...
    KL divergence: 0.7652, Iterations: 999, Trustworthiness: 0.9775, Time: 3.0 s
  Perplexity = 50...
    KL divergence: 0.5745, Iterations: 999, Trustworthiness: 0.9750, Time: 3.5 s
  Perplexity = 100...
    KL divergence: 0.2650, Iterations: 999, Trustworthiness: 0.9653, Time: 4.9 s

✓ t-SNE 降維完成（所有困惑度）
```

> 執行時間依硬體而異，此處為本機實測值。**Trustworthiness** 衡量低維嵌入中的 10 個最近鄰是否也是高維空間中的最近鄰（越接近 1 越好），可跨困惑度比較；相較之下 KL 散度不行。

![t-SNE 不同困惑度比較](outputs/P2_Unit06_tSNE/figs/tsne_perplexity_comparison.png)

**圖表分析：困惑度對結果的影響**

本圖展示困惑度分別為 5, 10, 30, 50, 100 時的 t-SNE 結果：

| 困惑度 | 視覺化特性 | KL 散度 | Trustworthiness | 評估 |
|--------|-----------|---------|-----------------|------|
| **5** | 三群仍可分辨，但群集延展、邊緣不規則，Mode C 被拆成數條窄帶 | 1.0356 | 0.9695 | 過度關注局部 |
| **10** | 三群分離，群集仍偏延展、結構鬆散 | 1.0035 | 0.9736 | 尚可 |
| **30** | 三群清楚分離，群集緊湊且無碎裂 | 0.7652 | **0.9775** | ✅ **選用** |
| **50** | 三群分離，群集更緊密 | 0.5745 | 0.9750 | 良好 |
| **100** | 三群被壓成很小的緊密圓團，群集內部結構幾乎消失 | 0.2650 | 0.9653 | 過度平滑 |

**實際執行觀察**：
1. **KL 散度不能用來選困惑度**：
   - KL 散度隨困惑度增加而持續下降，困惑度 = 100 時最低 (0.2650)
   - 不同困惑度的目標分布 $P$ 不同，KL 不可互相比較，不能以此判斷哪個困惑度較好

2. **Trustworthiness 在困惑度 = 30 最高**（0.9775）：
   - 表示在這五個設定中，困惑度 30 最忠實保留高維近鄰關係
   - 差異很小（約 0.01），僅作為輔助依據

3. **收斂狀況**：
   - 所有困惑度的 `n_iter_` 都是 999，表示跑滿 `max_iter=1000`（未觸發提前停止）
   - 這不等於已完全收斂，僅表示迭代次數用盡

4. **全局配置隨困惑度改變**：
   - 困惑度 5、10 時三群大致由左至右排成一列；困惑度 30 以上則呈三角形配置
   - 各子圖的座標範圍差異很大，再次說明 t-SNE 的絕對座標、群集大小與群集間距離都不具定量意義

5. **計算時間**：隨困惑度增加而上升（本機約 2.0 s → 4.9 s）

**選用困惑度 = 30 的理由**：
- 三個操作模式清楚分離，群集緊湊且未被過度壓縮
- Trustworthiness 在測試的五個值中最高
- 符合 scikit-learn 建議範圍（5-50）與預設值 30

**關鍵洞察**：
- 小困惑度（5-10）：群集延展、邊緣不規則，對局部雜訊較敏感
- 中困惑度（30-50）：平衡局部與全局結構，通常最佳
- 大困惑度（100）：群集被過度壓縮，群集內的變異幾乎消失
- **選參需綜合多項診斷**：觀察圖形、trustworthiness、多個隨機種子的穩定性，不要只看 KL 散度

---

#### 8.2.2 最終 t-SNE 視覺化結果

使用困惑度 = 30 生成最終視覺化：

**執行程式碼**：
```python
best_perplexity = 30
X_tsne_final = tsne_results[best_perplexity]['embedding']

fig, axes = plt.subplots(1, 2, figsize=(16, 6))

# 左圖：按操作模式著色
for i, mode_name in enumerate(mode_names):
    mask = labels == i
    axes[0].scatter(X_tsne_final[mask, 0], X_tsne_final[mask, 1], color=mode_colors[i],
                    label=mode_name, alpha=0.7, edgecolors='k', 
                    linewidth=0.5, s=80)
axes[0].set_title('t-SNE Visualization: Operating Modes')

# 右圖：按產物產率著色（連續變量）
product_yield = df['Product_Yield'].values
scatter = axes[1].scatter(X_tsne_final[:, 0], X_tsne_final[:, 1], 
                          c=product_yield, cmap='viridis', alpha=0.7)
axes[1].set_title('t-SNE Visualization: Product Yield')
plt.colorbar(scatter, ax=axes[1])
```

**執行結果**：
```
✓ 最終 t-SNE 視覺化圖已儲存
```

![t-SNE 最終結果](outputs/P2_Unit06_tSNE/figs/tsne_final_visualization.png)

**圖表分析：三種操作模式的視覺化呈現**

**左圖：按操作模式著色（離散標籤）**
- **Mode A（藍色，低溫低壓）**：
  - 位於左上方（約 $x=-40$ ）
  - 形成獨立的緊湊群集
  
- **Mode B（橙色，高溫高壓）**：
  - 位於右上方（約 $x=40$ ）
  - 形成獨立的緊湊群集
  
- **Mode C（綠色，中溫中壓）**：
  - 位於下方中央（約 $x=0$ ）
  - 形成獨立的緊湊群集
- 三個群集的大小相近。這是 t-SNE 的特性（各群集都被壓成大致相同的密度），**不能**用來推論某個模式的變異較大或較小

**右圖：按產物產率著色（連續變量）**
- 顏色範圍約從 0.62（深紫）到 1.0（黃）
- **Mode B 群集**：整體偏黃綠，產率最高
- **Mode A 群集**：整體偏紫藍，產率最低
- **Mode C 群集**：偏青綠，產率介於 A、B 之間
- 群集內部的顏色是雜亂混合的，沒有清楚的空間漸變（各模式內產率標準差約 0.04，小於組間差異）
- 產率本身是 t-SNE 的輸入特徵之一，因此此圖只是「觀察」，不是獨立驗證

**關鍵發現**：

1. ✅ **三種操作模式清楚分離**：
   - t-SNE 將 600 個樣本在 2D 空間中按操作模式分開，群集之間有明顯空白
   - 本例資料各模式在特徵平均值上差異大、原本就很容易區分，因此這個結果並不意外

2. ✅ **群集間的相對位置僅供參考**：
   - 群集中心距離：A–C 約 43、C–B 約 44、A–B 約 81，順序 A–C–B 與資料設計（低、中、高溫壓）一致
   - 但 t-SNE 的群集間距離在不同困惑度與隨機種子下會改變，不可作定量解讀（例如 8.2.1 中困惑度 5、10 時三群由左至右排成一列）

3. ✅ **產率與模式的對應**：
   - 產率由高到低：Mode B > Mode C > Mode A，與資料設計一致
   - 沒有異常的顏色跳躍現象

4. ✅ **化工意義**：
   - Mode A（低溫低壓）：節能但產率低
   - Mode B（高溫高壓）：高產率但能耗高
   - Mode C（中溫中壓）：平衡策略
   - t-SNE 視覺化可協助辨識三種操作策略的分群

**實務價值**：
- 快速識別當前操作屬於哪種模式
- 視覺化歷史操作模式的分布
- 發現異常操作條件（落在群集之外的點）
- 輔助操作優化決策（根據產率選擇模式）

---

### 8.3 t-SNE 與 PCA 對比分析

為了比較非線性與線性降維的差異，我們將 t-SNE 與 PCA 的視覺化結果進行對比。

**執行程式碼**：
```python
from sklearn.decomposition import PCA

# PCA 降維
pca = PCA(n_components=2, random_state=42)
X_pca = pca.fit_transform(X_scaled)

# 繪製對比圖
fig, axes = plt.subplots(1, 2, figsize=(16, 6))

# 左圖：PCA
for i, mode_name in enumerate(mode_names):
    mask = labels == i
    axes[0].scatter(X_pca[mask, 0], X_pca[mask, 1], color=mode_colors[i],
                    label=mode_name, alpha=0.7, s=80)
axes[0].set_xlabel('PC1 ({:.1f}%)'.format(pca.explained_variance_ratio_[0]*100))
axes[0].set_ylabel('PC2 ({:.1f}%)'.format(pca.explained_variance_ratio_[1]*100))
axes[0].set_title('PCA Visualization')

# 右圖：t-SNE
for i, mode_name in enumerate(mode_names):
    mask = labels == i
    axes[1].scatter(X_tsne_final[mask, 0], X_tsne_final[mask, 1], color=mode_colors[i],
                    label=mode_name, alpha=0.7, s=80)
axes[1].set_title('t-SNE Visualization')
```

**執行結果**：
```
✓ PCA vs t-SNE 比較圖已儲存
  PC1 + PC2 累積解釋變異數: 86.7%
```

![t-SNE vs PCA 對比](outputs/P2_Unit06_tSNE/figs/tsne_vs_pca_comparison.png)

**圖表分析：t-SNE 與 PCA 的降維結果比較**

**左圖：PCA (2D)**
- **PC1 解釋變異數**：約 80.7%
- **PC2 解釋變異數**：約 6.1%
- **累積解釋變異數**：約 86.7%
- **模式分離情況**：
  - Mode A（藍色）：位於左側
  - Mode C（綠色）：位於中間
  - Mode B（橙色）：位於右側
- **視覺特性**：
  - 三個模式沿 PC1 方向（橫軸）依 A→C→B 順序排列，群集之間彼此分離，沒有重疊
  - PC1 已解釋約 81% 的變異，表示模式間的差異主要沿一個方向（溫度、壓力、產率等特徵同步變化）
  - 群集間距離在 PCA 空間中仍具度量意義

**右圖：t-SNE (2D)**
- **模式分離情況**：
  - Mode A（藍色）：左上方，獨立群集
  - Mode B（橙色）：右上方，獨立群集
  - Mode C（綠色）：下方中央，獨立群集
- **視覺特性**：
  - 三個模式彼此分離，群集被壓縮得更緊湊
  - 群集間的空白距離、群集大小與絕對座標不具定量意義

> 結論：本例資料過於簡單，**PCA 和 t-SNE 都能完全分開三種操作模式**。兩者的差異不在「能不能分開」，而在群集的緊湊程度、近鄰保留程度與幾何意義。

**定量比較**：

**執行程式碼**：
```python
from sklearn.metrics import silhouette_score, calinski_harabasz_score
from sklearn.manifold import trustworthiness

# 原始標準化空間（基準）
sil_orig = silhouette_score(X_scaled, labels)
ch_orig = calinski_harabasz_score(X_scaled, labels)

# PCA 評估
sil_pca = silhouette_score(X_pca, labels)
ch_pca = calinski_harabasz_score(X_pca, labels)
trust_pca = trustworthiness(X_scaled, X_pca, n_neighbors=10)

# t-SNE 評估
sil_tsne = silhouette_score(X_tsne_final, labels)
ch_tsne = calinski_harabasz_score(X_tsne_final, labels)
trust_tsne = tsne_results[best_perplexity]['trust']
```

**執行結果**：
```
======================================================================
定量評估指標比較
======================================================================
           空間  輪廓係數 (Silhouette)  Calinski-Harabasz  Trustworthiness (k=10)
原始 10 維 (標準化)           0.493632        1136.683675                     NaN
     PCA (2D)           0.695130        3100.700761                0.927282
   t-SNE (2D)           0.801896        7807.328934                0.977480
======================================================================

解讀:
- 輪廓係數越接近 1、Calinski-Harabasz 越高，表示已知標籤的群集分離越明顯
- t-SNE 會壓縮群集，使上述兩項指標偏高；t-SNE 的值高於原始空間不代表保留了更多資訊
- Trustworthiness 越接近 1，表示低維近鄰關係越忠實於高維空間

結論: 兩種方法都能清楚分出三種操作模式；t-SNE 的 trustworthiness 較高 (0.977 vs 0.927)，但 PCA 速度快、可投影新數據且保留群集間的全局距離。
```

**定量評估分析**：

| 指標 | 原始 10 維 | PCA (2D) | t-SNE (2D) | 說明 |
|------|-----------|----------|------------|------|
| **輪廓係數** | 0.494 | 0.695 | 0.802 | 降維後的值都高於原始空間（PCA 與 t-SNE 皆然），不代表降維後保留了更多資訊 |
| **Calinski-Harabasz** | 1136.68 | 3100.70 | 7807.33 | t-SNE 壓縮群集，此指標天然有利 |
| **Trustworthiness (k=10)** | - | 0.927 | **0.977** | 用來比較兩種降維的近鄰保留程度 |
| **計算時間** | - | 約 0.001 s | 約 3 s | 本機實測，600 個樣本 |

**評估指標解讀**：

1. **輪廓係數與 Calinski-Harabasz 分數**：
   - 衡量「已知標籤」在該空間中的分離程度
   - t-SNE 的數值較高，但這主要是因為 t-SNE 會把群集壓縮得更緊湊，不能單獨作為「t-SNE 優於 PCA」的證據
   - 這兩項指標對已有「緊湊群集」的嵌入都會得到高分，與是否保留高維結構無關

2. **Trustworthiness**：
   - 範圍為 [0, 1]，越接近 1 表示低維中的近鄰越可信
   - t-SNE（0.977）高於 PCA（0.927），符合 t-SNE 專為保留局部近鄰而設計的特性
   - 兩者都在 0.9 以上，差距不大

**關鍵結論**：

✅ **兩種方法都能完全分開本例的三種操作模式**：
- 資料本身就很容易分群，無法從此例看出兩者的優劣
- t-SNE 的 trustworthiness 較高，近鄰保留較佳

✅ **t-SNE 適合探索性分析**：
- 適合在資料結構未知時觀察局部群集結構
- 視覺化結果直觀

⚠️ **t-SNE 計算成本更高**：
- PCA：約 0.001 秒
- t-SNE：約 3 秒（600 樣本，本機實測）
- 樣本數大時，時間差異會更明顯

⚠️ **PCA 仍有其獨特優勢**：
- 可解釋性：PC 軸有明確的變異數解釋
- 可投影新數據：適合即時監控
- 速度快：適合大規模數據
- 全局結構保留：群集間距離仍有意義

**實務建議**：

| 應用場景 | 推薦方法 | 理由 |
|---------|---------|------|
| **初步探索** | t-SNE | 快速了解數據結構，視覺化效果佳 |
| **製程監控** | PCA | 可投影新數據，速度快，可建立控制圖 |
| **異常檢測** | PCA | 可計算 T² 和 SPE 統計量 |
| **報告展示** | t-SNE | 視覺效果清晰，易於理解 |
| **大規模數據（N > 10000）** | PCA | 計算效率高 |
| **組合使用** | PCA + t-SNE | PCA 預處理（30-50維）+ t-SNE 視覺化 |

**化工製程應用建議**：
- **離線分析**：使用 t-SNE 探索歷史數據，發現操作模式
- **即時監控**：使用 PCA 建立監控模型，快速投影新數據
- **報告呈現**：使用 t-SNE 生成清晰的視覺化圖表
- **異常追蹤**：PCA 檢測異常，t-SNE 視覺化異常位置

**本節小結**：
- ✅ 完成三種操作模式的數據生成與標準化
- ✅ t-SNE 成功將 10 維數據降至 2 維
- ✅ 測試 5 種困惑度，選用 30（trustworthiness 最高）
- ✅ 定量評估：t-SNE 的 trustworthiness 較高（0.977 vs 0.927），但輪廓係數與 CH 分數對 t-SNE 天然有利，不可單獨用來判定優劣
- ✅ PCA 與 t-SNE 都能分開本例的三種模式，PCA 速度快且可投影新資料
- ✅ t-SNE 的群集大小與群集間距離不具定量意義

---

## 9. t-SNE 最佳實踐與技巧

### 9.1 數據預處理

**1. 標準化或正規化**：
```python
from sklearn.preprocessing import StandardScaler

scaler = StandardScaler()
X_scaled = scaler.fit_transform(X)
```
- ✅ 消除不同特徵的尺度差異
- ✅ 提升 t-SNE 的穩定性與效果

**2. 處理缺失值**：
```python
from sklearn.impute import SimpleImputer

imputer = SimpleImputer(strategy='mean')
X_imputed = imputer.fit_transform(X)
```
- t-SNE 無法處理 NaN 值
- 使用均值、中位數或更複雜的插補方法

**3. 移除低方差特徵**：
```python
from sklearn.feature_selection import VarianceThreshold

# 在標準化之前對原始數據檢查（標準化後所有特徵變異數皆為 1，會失去篩選意義）
selector = VarianceThreshold(threshold=1e-8)
X_selected = selector.fit_transform(X)
```
- 移除變異數接近 0（幾乎不變）的特徵
- 不同量級的特徵需先檢查再標準化

**4. PCA 預降維（高維數據）**：
```python
from sklearn.decomposition import PCA

pca = PCA(n_components=50, random_state=42)
X_pca = pca.fit_transform(X_scaled)
```
- 原始維度 > 50 時強烈建議
- 保留 90-95% 變異數即可

### 9.2 超參數調整策略

**1. 困惑度 (Perplexity)**：
```python
perplexities = [5, 10, 30, 50, 100]

for perp in perplexities:
    tsne = TSNE(n_components=2, perplexity=perp, random_state=42)
    X_tsne = tsne.fit_transform(X_scaled)
    # 視覺化並比較
```
- 嘗試多個值，選擇視覺化最清晰的
- 通常 30 是好的起點

**2. 學習率 (Learning Rate)**：
```python
# 使用自動學習率（推薦）
tsne = TSNE(n_components=2, learning_rate='auto', random_state=42)

# 或手動調整
learning_rates = [10, 100, 200, 1000]
for lr in learning_rates:
    tsne = TSNE(n_components=2, learning_rate=lr, random_state=42)
    X_tsne = tsne.fit_transform(X_scaled)
```
- 'auto' 模式通常效果良好
- 如果結果過於緊密或分散，手動調整

**3. 迭代次數 (max_iter)**：
```python
tsne = TSNE(n_components=2, max_iter=1000, random_state=42)
X_tsne = tsne.fit_transform(X_scaled)

# 檢查是否跑滿最大迭代次數（n_iter_ 滿載時為 max_iter - 1）
if tsne.n_iter_ >= tsne.max_iter - 1:
    print("跑滿 max_iter，可能需要更多迭代")
else:
    print("提前停止")
```
- 建議 1000 次以上（小數據集可視情況使用 250-1000）
- 視覺檢查結果穩定性

**4. 初始化方法 (init)**：
```python
# PCA 初始化（推薦）
tsne_pca = TSNE(n_components=2, init='pca', random_state=42)

# 隨機初始化
tsne_random = TSNE(n_components=2, init='random', random_state=42)
```
- 'pca' 更穩定、收斂更快
- 'random' 可用於探索多個局部最優

### 9.3 視覺化技巧

**1. 使用顏色編碼**：
```python
# 按類別著色
plt.scatter(X_tsne[:, 0], X_tsne[:, 1], c=labels, cmap='tab10', alpha=0.7)

# 按連續變量著色
plt.scatter(X_tsne[:, 0], X_tsne[:, 1], c=continuous_var, cmap='viridis', alpha=0.7)
plt.colorbar(label='Variable Name')
```

**2. 添加標籤與註釋**：
```python
for i, label in enumerate(sample_labels):
    plt.annotate(label, (X_tsne[i, 0], X_tsne[i, 1]), fontsize=8)
```

**3. 使用群集輪廓**：
```python
from scipy.spatial import ConvexHull

for cluster_id in np.unique(labels):
    cluster_points = X_tsne[labels == cluster_id]
    hull = ConvexHull(cluster_points)
    idx = np.append(hull.vertices, hull.vertices[0])  # 首尾相接形成封閉多邊形
    plt.plot(cluster_points[idx, 0], cluster_points[idx, 1], 'k--', alpha=0.5)
```

**4. 3D 視覺化**：
```python
from mpl_toolkits.mplot3d import Axes3D

tsne_3d = TSNE(n_components=3, random_state=42)
X_tsne_3d = tsne_3d.fit_transform(X_scaled)

fig = plt.figure(figsize=(10, 8))
ax = fig.add_subplot(111, projection='3d')
ax.scatter(X_tsne_3d[:, 0], X_tsne_3d[:, 1], X_tsne_3d[:, 2], c=labels, cmap='tab10')
plt.show()
```

### 9.4 穩定性與可重複性

**1. 固定隨機種子**：
```python
tsne = TSNE(n_components=2, random_state=42)
```

**2. 多次運行比較**：
```python
n_runs = 5
results = []

for i in range(n_runs):
    tsne = TSNE(n_components=2, random_state=i)
    X_tsne = tsne.fit_transform(X_scaled)
    results.append(X_tsne)

# 視覺化所有結果，檢查一致性
```

**3. 使用 PCA 初始化提升穩定性**：
```python
tsne = TSNE(n_components=2, init='pca', random_state=42)
```

### 9.5 大規模數據處理

**策略 1：隨機採樣**：
```python
from sklearn.utils import resample

# 不放回抽樣至 10000 樣本（resample 預設 replace=True，需明確設為 False）
X_sampled = resample(X, n_samples=10000, replace=False, random_state=42)
```

**策略 2：使用 Barnes-Hut 近似**：
```python
tsne = TSNE(n_components=2, method='barnes_hut', angle=0.5)
```
- 默認方法， $O(N \log N)$ ，可處理數萬筆樣本（但仍較慢）
- angle 越小越精確但越慢
- Barnes-Hut 僅支援 `n_components` < 4

**策略 3：改用 UMAP**：
```python
import umap

reducer = umap.UMAP(n_components=2, random_state=42)
X_umap = reducer.fit_transform(X_scaled)
```
- 速度更快：O(N log N)
- 效果類似 t-SNE，保留更多全局結構

### 9.6 常見錯誤與解決方案

| 錯誤現象 | 可能原因 | 解決方案 |
|---------|---------|---------|
| 所有點壓縮成一團緻密的雲，僅少數離群點 | 學習率太小 | 增加學習率至 100-1000 |
| 球狀、點與點距離幾乎相等 | 學習率太大 | 降低學習率或使用 'auto' |
| 過多小群集 | 困惑度太小 | 增加困惑度至 30-50 |
| 群集過度合併 | 困惑度太大 | 降低困惑度 |
| KL 散度異常高 | 參數不當或未收斂 | 增加迭代次數，調整參數 |
| 結果每次都不同 | 未固定隨機種子 | 設置 random_state |
| 計算時間過長 | 數據量太大 | PCA 預降維或隨機採樣 |

---

## 10. t-SNE 延伸學習

### 10.1 t-SNE 的理論改進

**Parametric t-SNE**：
- 使用神經網絡學習映射函數
- 可以投影新數據
- 但需要更多計算資源

**Multi-scale t-SNE**：
- 同時考慮多個困惑度
- 綜合局部與全局結構
- 較新的研究方向

### 10.2 替代方法：UMAP

UMAP (Uniform Manifold Approximation and Projection) 是 t-SNE 的改進版本：

**UMAP 優勢**：
- ✅ 速度更快： $O(N \log N)$ 
- ✅ 保留更多全局結構
- ✅ 可以投影新數據（某種程度）
- ✅ 適合大規模數據

**UMAP 使用**：
```python
import umap

reducer = umap.UMAP(
    n_components=2,
    n_neighbors=30,   # 類似困惑度
    min_dist=0.1,     # 控制群集緊密度
    metric='euclidean',
    random_state=42
)

X_umap = reducer.fit_transform(X_scaled)
```

**何時選擇 UMAP？**
- 數據量 > 10000
- 需要更快的計算速度
- 需要保留全局結構
- 需要投影新數據

### 10.3 化工領域的進階應用

**1. 時間序列視覺化**：
- 將時間窗口數據降維
- 觀察製程動態軌跡
- 識別異常時間段

**2. 批次製程軌跡分析**：
- 將整個批次展平為向量
- 使用 t-SNE 視覺化批次間的相似性
- 識別成功與失敗批次的差異

**3. 高維光譜數據**：
- NIR、Raman、IR 光譜的視覺化
- 快速識別化合物類別
- 輔助化學計量學分析

**4. 配方空間探索**：
- 視覺化不同配方的效果
- 識別最優配方區域
- 輔助實驗設計

### 10.4 參考資源

**經典論文**：
- Van der Maaten, L., & Hinton, G. (2008). *Visualizing Data using t-SNE*. Journal of Machine Learning Research.
- Wattenberg, et al. (2016). *How to Use t-SNE Effectively*. Distill.

**線上工具**：
- [Embedding Projector](https://projector.tensorflow.org/)：互動式 t-SNE 視覺化
- [Distill.pub](https://distill.pub/2016/misread-tsne/)：*How to Use t-SNE Effectively* 互動教學

**Python 套件**：
- scikit-learn：標準實現
- Multicore-TSNE：多核心加速版本
- UMAP：t-SNE 的改進版本

---

## 11. 實作演練總結

### 11.1 完整工作流程回顧

本單元的實作演練 (`Unit06_tSNE.ipynb`) 展示了 t-SNE 在化工製程視覺化的完整應用流程：

**步驟 1：數據準備**
- ✅ 生成 600 個樣本，10 個特徵，3 種操作模式
- ✅ 模擬真實化工製程的多操作模式情境
- ✅ 數據標準化處理（均值=0，標準差=1）

**步驟 2：t-SNE 參數調整**
- ✅ 測試 5 種困惑度：[5, 10, 30, 50, 100]
- ✅ 觀察 KL 散度變化：1.0356 → 0.2650（不可跨困惑度比較）
- ✅ 選用困惑度 30（trustworthiness 最高 0.9775）

**步驟 3：視覺化生成**
- ✅ 生成困惑度比較圖（5 個子圖）
- ✅ 生成最終視覺化圖（操作模式 + 產率著色）
- ✅ 生成 PCA vs t-SNE 對比圖

**步驟 4：定量評估**
- ✅ 輪廓係數：原始 10 維 0.494、PCA 0.695、t-SNE 0.802
- ✅ Trustworthiness：PCA 0.927、t-SNE 0.977
- ✅ 結論：兩者都能分開三種模式；t-SNE 的近鄰保留較佳，但輪廓係數與 CH 分數對 t-SNE 天然有利，不能單獨視為「t-SNE 優於 PCA」的證據

### 11.2 關鍵發現與洞察

**1. 困惑度選擇的重要性**：
- KL 散度最低（perplexity=100）**不代表**結果最好，KL 不可跨困惑度比較
- 中等困惑度（30-50）通常能平衡局部與全局結構
- 小困惑度容易產生延展、邊緣不規則的群集
- 需要結合視覺化效果與 trustworthiness 等指標綜合判斷

**2. t-SNE 與 PCA 的比較**：
- 本例 PCA 和 t-SNE 都能完全分開三種操作模式（資料本身很容易分群）
- t-SNE 的 trustworthiness 較高，PCA 則可解釋、可投影新數據
- t-SNE 的群集間距離與群集大小不具定量意義

**3. 連續變量映射效果**：
- 產物產率在各群集間有明顯差異（B > C > A）
- 群集內部的產率變化是雜亂的，無明顯空間漸變
- 產率本身是輸入特徵之一，這只是觀察，不是獨立驗證

**4. 計算成本與效果的權衡**：
- PCA：約 0.001 秒
- t-SNE：約 3 秒（600 樣本，本機實測）
- 對於 600 樣本，t-SNE 的額外計算成本可接受

### 11.3 化工應用價值驗證

**1. 操作模式識別**：
- ✅ 三種操作模式清晰分離，易於識別
- ✅ 可用於即時監控當前操作屬於哪種模式
- ✅ 輔助操作人員理解製程狀態

**2. 異常檢測支援**：
- ✅ 偏離群集中心的樣本容易被視覺識別
- ✅ 可結合 PCA 的 T²/SPE 統計量進行異常檢測
- ✅ 提供直觀的異常位置視覺化

**3. 製程優化輔助**：
- ✅ 清楚展現三種操作策略的權衡關係
- ✅ 產率與能耗的關聯關係直觀可見
- ✅ 輔助選擇合適的操作模式

**4. 報告與溝通**：
- ✅ 視覺化效果清晰，易於向管理層解釋
- ✅ 無需深入技術細節，一目了然
- ✅ 適合製程審查、品質報告等場合

### 11.4 實務應用建議

**1. 資料規模考量**：
- 樣本數 < 1000：t-SNE 執行很快，直接使用
- 樣本數 1000-10000：執行時間明顯增加（scikit-learn 預設已使用 Barnes-Hut 近似），可視需要先 PCA 降維
- 樣本數 > 10000：先用 PCA 降至 30-50 維，再使用 t-SNE，或改用更快的工具（如 openTSNE、UMAP）
- 特徵數 > 50：建議 PCA 預處理

**2. 參數調整策略**：
- 困惑度：先試 [5, 30, 100]，再細調
- 學習率：使用 'auto' 模式（scikit-learn ≥ 1.0）
- 迭代次數：至少 1000 次，確保收斂
- 初始化：使用 'pca' 提升穩定性

**3. 結果驗證檢查**：
- ✅ 檢查 KL 散度是否收斂
- ✅ 使用多個隨機種子確認結果穩定性
- ✅ 計算 trustworthiness，並以原始空間為基準看輪廓係數等群集指標
- ✅ 結合化工知識驗證結果合理性

**4. 與 PCA 組合使用**：
- **初步探索**：使用 t-SNE 發現數據結構
- **模型建立**：使用 PCA 建立監控模型
- **即時監控**：使用 PCA 投影新數據
- **定期審查**：使用 t-SNE 重新視覺化歷史數據

---

## 12. 課程總結

本單元深入介紹了 t-分布隨機鄰域嵌入 (t-SNE) 的核心概念、數學原理與實務應用：

**核心要點**：
1. t-SNE 是專為高維數據視覺化設計的非線性降維技術
2. 通過最小化高低維空間分布的 KL 散度，保持局部相似性結構
3. 使用 t-分布解決擁擠問題，生成清晰的群集視覺化
4. 困惑度和學習率是最關鍵的超參數，需仔細調整
5. t-SNE 不保留全局結構，群集間距離無明確意義

**實作演練成果**：
- ✅ 成功將 600 個樣本（10 維）降至 2D 視覺化
- ✅ 三種操作模式清楚分離，輪廓係數 0.802（注意：t-SNE 空間中的該指標會被高估）
- ✅ 定量比較：t-SNE trustworthiness 0.977 vs PCA 0.927，兩者都能分開本例的三種模式
- ✅ 生成 3 張視覺化圖表並儲存
- ✅ 選用困惑度 = 30（本例 trustworthiness 最高）

**t-SNE 的優勢**：
- ✅ 視覺化效果優秀，群集分離清晰
- ✅ 能捕捉複雜的非線性關係
- ✅ 適合探索性數據分析
- ✅ 直觀易懂，適合報告與溝通

**t-SNE 的局限性**：
- ❌ 計算成本高，不適合大規模數據（N > 10000）
- ❌ 無法投影新數據，每次需重新運行
- ❌ 超參數敏感，結果具有隨機性
- ❌ 不保留全局結構與絕對距離

**化工應用價值**：
- 多變數製程狀態視覺化（本次實作已驗證）
- 操作模式識別與分群（本例三模式清楚分離）
- 異常樣本的視覺化檢測（可結合 PCA）
- 高維光譜與配方數據探索

**與 PCA 的互補關係**：
- **PCA**：製程監控、特徵工程、快速降維、可投影新數據
- **t-SNE**：探索性分析、視覺化呈現、非線性結構發現
- **組合策略**：PCA 預處理（30-50維）+ t-SNE 視覺化
- **實作驗證**：t-SNE trustworthiness 0.977 vs PCA 0.927；PCA 速度快（約 0.001 s vs 約 3 s）

**後續學習建議**：
- 實作完整的多模式製程視覺化系統
- 探索 UMAP 作為 t-SNE 的替代方案（速度更快，保留更多全局結構）
- 學習如何結合 t-SNE 與分群算法（K-Means, DBSCAN 等）
- 研究批次製程軌跡的降維視覺化技術
- 應用於實際化工數據（NIR 光譜、製程數據、品質數據等）

---

**配合程式演練**：請參考 `Unit06_tSNE.ipynb` 進行完整的化工案例實作練習，該 Notebook 包含詳細的程式碼範例、執行結果與視覺化圖表。

**實作成果檔案**：
- 📊 `outputs/P2_Unit06_tSNE/figs/tsne_perplexity_comparison.png`：困惑度比較圖（5 個子圖）
- 📊 `outputs/P2_Unit06_tSNE/figs/tsne_final_visualization.png`：最終視覺化結果（操作模式 + 產率）
- 📊 `outputs/P2_Unit06_tSNE/figs/tsne_vs_pca_comparison.png`：t-SNE vs PCA 對比圖

---

**下一步**：Unit06 的 UMAP 單元，將介紹 t-SNE 的改進版本，速度更快且保留更多全局結構。

---

**課程資訊**
- 課程名稱：AI在化工上之應用 (ChemE 3590)
- 課程單元：Unit06 t-SNE 在化工製程視覺化的應用
- 課程製作：逢甲大學 化工系 智慧程序系統工程實驗室
- 授課教師：莊曜禎 助理教授
- 更新日期：2026-10-27

**課程授權 [CC BY-NC-SA 4.0]**
 - 本教材遵循 [創用CC 姓名標示-非商業性-相同方式分享 4.0 國際 (CC BY-NC-SA 4.0)](https://creativecommons.org/licenses/by-nc-sa/4.0/deed.zh) 授權。

---
