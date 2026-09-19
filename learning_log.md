# 暑假自主研究與學習、Debug日誌
- **[點我回「README.md」](./README.md)**



<a id="toc"></a>

## 目錄（點日期跳轉）

| 日期 | 內容摘要 |
|---|---|
| [7/3](#m07d03) | 影片：TT 小教室第 1~5 課。 |
| [7/4](#m07d04) | 影片：TT 小教室第 6~7 課。 |
| [7/5](#m07d05) | 影片：TT 小教室第 8~11 課。 |
| [7/6](#m07d06) | 刷題：完成 HDLBits 的 "carry-slect Adder" 到 "a priority encoder for 8-bit inputs"。 |
| [7/7](#m07d07) | 影片：清大OCW王俊堯教授數位邏輯設計第 8B~8E 講。 |
| [7/8](#m07d08) | 資料：複習7/3 - 7/7進度。 |
| [7/9](#m07d09) | 影片：看財經村長-數位IC設計面試1。 |
| [7/10](#m07d10) | 資料：複習7/3 - 7/9內容。 |
| [7/11](#m07d11) | 資料：複習7/3 - 7/10內容。 |
| [7/13](#m07d13) | 資料：複習7/3 - 7/11內容。 |
| [7/14](#m07d14) | 刷題：完成 HDLBits 的 D latch 到 Implement a JK flip-flop with only a D-type flip-flop and gates（Exams/ece241 2013 q7）。 |
| [7/15](#m07d15) | 資料：複習7/3 - 7/14內容。 |
| [7/16](#m07d16) | 影片：TT 小教室 Verilog RTL design 進階教學【Coding Style】- 【Synchronizer】 |
| [7/17](#m07d17) | 影片：TT 小教室 Verilog RTL design 進階教學【Memory】 |
| [7/21](#m07d21) | 資料：複習7/3 - 7/17內容。 |
| [7/23](#m07d23) | 資料：利用網路資源學習Vivado - How to use vivado for Beginners by Anand Raj |
| [7/24](#m07d24) | 影片：財經村長 - 如何面試上一線數位IC公司 II |
| [7/25](#m07d25) | 影片：第1講 Vivado設計流程及使用模式；How to use Vivado® Design Suite Part-5 Timing Summary Report |
| [7/27](#m07d27) | 資料：Barrel Shifters in Verilog: A Beginner’s Guide to Fast Multi-Bit Shifting |
| [7/28](#m07d28) | 資料：ALU design in Verilog using MIPS Instruction Set |
| [7/30](#m07d30) | 刷題：複習 HDLBits 7/3 - 7/17 進度。 |
| [7/31](#m07d31) | 資料：MIT 6.111 課程講義 Lecture 9《Pipelining & Verilog》(PDF) |
| [8/1](#m08d01) | ALU 設計：32bit_ALU_V1（Baseline） - 改寫 32-bit ALU baseline 版本 testbench |
| [8/2](#m08d02) | ALU 設計：32bit_ALU_V1（Baseline） - 第一次 Synthesis + Implementation 結果，並記錄收斂到 WNS 接近 0 的結果 |
| [8/3](#m08d03) | ALU_V2（pipeline）設計：完成 RTL，共歷經 5 輪修正才達到邏輯正確 |
| [8/4](#m08d04) | ALU_V2（pipeline）設計：完成 Testbench - alu_v2_tt，驗證 pipeline 版本功能 |
| [8/5](#m08d05) | ALU 設計：32bit_ALU_V2（pipeline） - 第一次 Synthesis + Implementation 結果，並記錄收斂到 WNS 接近 0 的結果 |
| [8/10](#m08d10) | Digital Design and Computer Architecture (ARM / RISC-V Edition) |
| [8/11](#m08d11) | ALU 設計優化：主動重構，把邏輯運算與 SLT 先獨立拆成一個組合邏輯，Stage1 暫存器改成**每拍無條件更新** |
| [8/12](#m08d12) | 刷題：複習 HDLBits 7/3 - 8/11 進度；完成 HDLBits 的 Shift Registers |
| [8/13](#m08d13) | 影片：Digital Design and Computer Architecture(Spring 2025) L1 - L2 |
| [8/14](#m08d14) | 影片：Digital Design and Computer Architecture(Spring 2025) L3 |
| [8/18](#m08d18) | 影片：Digital Design and Computer Architecture(Spring 2025) L4 |
| [8/19](#m08d19) | 影片：Digital Design and Computer Architecture(Spring 2025) L5 |
| [8/20](#m08d20) | 影片：Digital Design and Computer Architecture(Spring 2025) L6 |
| [8/21](#m08d21) | 刷題：複習 HDLBits 7/3 - 8/20 進度；資料：複習7/3 - 8/20 內容 |
| [9/1](#m09d01) | 刷題：複習 HDLBits 7/3 - 8/21 進度；資料：複習7/3 - 8/21 內容 |
| [9/3](#m09d03) | 影片：Digital Design and Computer Architecture(Spring 2025) L7 |
| [9/14](#m09d14) | 資料：複習7/3 - 9/3 內容 |
| [9/15](#m09d15) | 影片：Digital Design and Computer Architecture(Spring 2025) L8 |
| [9/16](#m09d16) | 影片：Digital Design and Computer Architecture(Spring 2025) L9 |
| [9/19](#m09d19) | 影片：Digital Design and Computer Architecture(Spring 2025) L10 |


---

<a id="m07d03"></a>

## 2026 年 7 月 3 日

## 今日進度：
### 影片：[TT 小教室第 1~5 課](https://www.youtube.com/watch?v=W1DlwK63fxw&list=PLuhWBQnV46Q-3oMz33PFSqjhJOvDDVUbJ)
### 刷題：完成 HDLBits 的 "basics" 到 "8-bit wide shift register of length 3(Three module)"。

## 遇到的困難與解決方案：
### 問題：在寫always、case語法撰寫不完整，導致編譯錯誤。
### 解法：於程式後面加上end、endcase，成功編譯。
```verilog
always @(*) begin
    case()

    endcase
end
```

## 關鍵知識/詞彙：
### 數位電路組成
* logic gate、memory、flip-flop、wire、bus、IO

### 晶圓廠能製作（Tape out）的layoyt檔
* GDS

### RTL（Register-Transfer Level）較 Gate-level-netlist比較
* RTL（Register-Transfer Level）較 Gate-level-netlist 高階

### wire連線
* （搭配 assign 語法）-> combinational logic

### reg（register）
* 暫存器（搭配 always 語法但不一定合成Flip-Flop）

### 硬體思維
* 同時持續處理（平行處理），程式碼先後順序不影響結果
  
### Multi-driven（重複驅動）
* 一條線被2個以上訊號驅動
  
### assign語法（持續賦值，不論順序）
* 用單等號＂＝＂（左邊需是 wire 形式，右邊可 wire 可 reg）。如果左位寬小於右邊，缺少的高位數會消失。
  
### always語法（條件賦值，有優先權問題）：
* always@(posedge clk)begin -> 循序邏輯（sequential logic），賦值用＂＜＝＂（non-blocking）
* always@(*)begin -> 組合邏輯（combinational logic），賦值用＂＝＂(blocking)，可創造出循序/組合邏輯。
* always裡面的變數須是reg形式。先給初始值 or 條件寫滿避免"Latch"
  
### 正反器（Flip-Flop）
* 又稱暫存器，同步數位電路最重要組成元件。與clock同步（上沿 0->1 positive edge, 下沿 1->0 negative edge）。邏輯深度決定電路速度
* 分清楚reset訊號跟clock是同步/非同步
* 同步reset（reset隨clock動作）：例`always@(posedge clk)begin`
* 非同步reset（reset一來就動作）：例`always@(posedge clk or negedge rst_n)begin`//低電位非同步reset
  
### 震盪器（Oscillator）
* `always #<一半的週期時間> clk=~clk`（通常用在Testbench產生clk，一般數位電路不會這樣寫）

[回目錄](#toc)

---

<a id="m07d04"></a>

## 2026 年 7 月 4 日

## 今日進度：
### 影片：[TT 小教室第 6~7 課](https://www.youtube.com/watch?v=W1DlwK63fxw&list=PLuhWBQnV46Q-3oMz33PFSqjhJOvDDVUbJ)
### 刷題：複習 HDLBits 的 "basics" 到 "8-bit wide shift register of length 3(Three module)"。

## 遇到的困難與解決方案：
### 問題：在Connecting Signals to Module Ports的時候，搞錯"by position"與"by name"這兩種方法，by position與宣告順序有關。
### 解法：複習兩種觀念，並搞懂兩者順序關聯，by position與順序有關，by name與順序無關。
```verilog
 //mod_a要求：module mod_a ( output, output, input, input, input, input );
 module top_module ( 
    input a, 
    input b, 
    input c,
    input d,
    output out1,
    output out2
);
    
    mod_a(out1, out2, a, b, c, d); //不可寫成mod_a(a, b, c, d, out1, out2);

endmodule
```

## 關鍵知識/詞彙：
### 位元運算元：
  
 | 符號 | 名稱 |
 | --- | --- |
 | ～ | Bitwise NOT |
 | ＆ | Bitwise AND |
 | ｜ | Bitwise OR |
 | ︿ | Bitwise XOR |

**每個位元獨立計算，IO位寬相同**

### 邏輯運算元：
  
 | 符號 | 名稱 |
 | --- | --- |
 | ！ | Logic NOT |
 | ＆＆ | Logic AND |
 | ｜｜ | Logic OR |

**判斷 T/F，output 為 1bit**

### Reduction運算元：
  
 | 符號 | 名稱 |
 | --- | --- |
 | ＆ | Reduction AND |
 | ｜ | Reduction OR |
 | ︿ | Reduction XOR |

**將運算元右邊陣列中的每一位元做運算，output 為 1bit**
* EX. a = 4'b0110, &a = 0 & 1 & 1 & 0 = 1'b0
  
### 關係運算元：
  
 | 符號 | 名稱 |
 | --- | --- |
 | ＝＝ | 邏輯等於 |
 | ！＝ | 邏輯不等於 |
 | ＝＝＝ | 4態等於 |
 | ！＝＝ | 4態不等於 |

**比較結果皆為1bit，＝＝＝包含 Uknown X 和 Hign Z的比較（當文字比較），＝＝遇到X or Z結果都是 X**

### 條件運算元（？：）：
**選擇條件 ? 條件成立結果 : 條件不成立結果**
    
### signed (有正負號數) vs unsigned (無正負號數)
* 宣告 wire 或 reg 時，預設為**unsigned**值
* 如果變數需要正負號，要加上**signed**保留字
* 這樣該變數的最高位(**MSB**)就是正負號**Signed bit**， 0 代表正數， 1 代表負數
* **signed**變數需要補位時，會用**signed bit**補 (**signed extension**)
* 例如：
  * `wire signed [7:0] a;`
  * `wire signed [3:0] b;`
  * `a[7]`和`b[3]`就分別是`a`和`b`的正負號
  * `assign a = 8'b1000_0011; -> a= -125 (2's complementary)`
  * `assign b = 4'b0010; -> b= +2`

### 數學運算元

| 符號 | 名稱 | 說明 | 範例 |
| --- | --- | --- | --- |
| ＋ | 加法 | 兩數相加 | assign z0 = a + b; |
| － | 減法 | 兩數相減 | assign z1 = a - b; |
| ＊ | 乘法 | 兩數相乘 | assign z2 = a * b; |
| ／ | 除法 | 兩數相除 | assign z3 = a / b; |
| ＊＊ | 指數 | 底數的次方 | assign z4 = a ** b; |
| ％ | 餘數 | 算餘數 | assign z5 = a % b; |

**注意位寬會不會Overflow（溢位）**
**注意是有正負號數 (**signed**) 還是無正負號數 (**unsigned**) 的運算**


### 位移運算元

| 符號 | 名稱 | 說明 | 範例 |
| --- | --- | --- | --- |
| >> | 邏輯右移 | 將變數右移某一固定位數，Signed bit不補位 | assign z1 = a >> 3; |
| << | 邏輯左移 | 將變數左移某一固定位數，LSB位補0 | assign z2 = a << 3; |
| >>> | 數學右移 | 將變數右移某一固定位數，Signed bit會補位 | assign z3 = a >>> 3; |
| <<< | 數學左移 | 將變數左移某一固定位數，LSB位補0 | assign z4 = a <<< 3; |

**注意位移的數量必須是 **常數** 才能合成出正確的結果**
**注意位移後的 **位寬** ，尤其是左移時，不夠時會丟失位元**
**注意是 **signed** 或是 **unsigned** 的型態，>> 和 >>> 結果不同**

### 位移運算元應用

**把一個8 bits整數除以8後四捨五入**
* wire [7:0] a;
* wire [5:0] z1;
* assign z1 = (a >> 3) + a[2]; //a[2]是位移之前的bit

**把一個8 bits整數除以8後無條件進位**
* wire [7:0] a;
* wire [5:0] z2;
* assign z2 = (a >> 3) + |a[2:0]; // |a[2:0] 是位移之前的 a[2] | a[1] | a[0]
  
**把一個8 bits整數除以8後無條件捨去**
* wire [7:0] a;
* wire [4:0] z3;
* assign z3 = (a >> 3);

[回目錄](#toc)

---

<a id="m07d05"></a>

## 2026 年 7 月 5 日

## 今日進度：
### 影片：[TT 小教室第 8~11 ](https://www.youtube.com/watch?v=W1DlwK63fxw&list=PLuhWBQnV46Q-3oMz33PFSqjhJOvDDVUbJ)
### 刷題：完成 HDLBits 的 "Adder1" 到 "Adder2"。

## 遇到的困難與解決方案：
### 問題1：
* Adder1（用兩個16位元加法器模塊合成出一個32位元加法器）
* 應題目需求：32位的加法器不需要處理進位（假設為 0）或出位（忽略)
<img width="528" height="342" alt="image" src="https://github.com/user-attachments/assets/ef7a65b8-8aba-43e0-82f1-93c8f5cb9194" />

* **ins1進位端無空接或用1位元的wire對接導致編譯錯誤**
* 原程式碼：
  ```verilog
  module top_module(
    input [31:0] a,
    input [31:0] b,
    output [31:0] sum
    );

    wire k; //處理inst0進位
    add16 inst0(a[15:0], b[15:0], 1'b0, sum[15:0], k);
    add16 inst1(a[31:16], b[31:16], k, sum[31:16], sum); 
    endmodule
    ```
  
### 解法：
* **宣告一wire"count_useless"用來接最後丟棄的進位**
  ```verilog
  module top_module(
    input [31:0] a,
    input [31:0] b,
    output [31:0] sum
    );
    //module add16 ( input[15:0] a, input[15:0] b, input cin, output[15:0] sum, output cout );
    wire k, cout_useless;// count_useless用來接最後丟棄的進位
    add16 inst0(a[15:0], b[15:0], 1'b0, sum[15:0], k);
    add16 inst1(a[31:16], b[31:16], k, sum[31:16], cout_useless);

    endmodule
  ```
* **更好的寫法（Named Connection）**
  ```verilog
  module top_module(
    input [31:0] a,
    input [31:0] b,
    output [31:0] sum
    );
    wire k;

    // 低 16 位加法
    add16 inst0(
        .a(a[15:0]),
        .b(b[15:0]),
        .cin(1'b0),
        .sum(sum[15:0]),
        .cout(k)
    );
    
    // 高 16 位加法
    add16 inst1(
        .a(a[31:16]),
        .b(b[31:16]),
        .cin(k),
        .sum(sum[31:16]),
        .cout() // 最高位進位如果不要，在具名寫法中直接留空即可
    );

    endmodule
  ```
  ### 問題2：
  * Adder2（Module fadd）
  * 不知為何需特別把module add1寫出來
  <img width="658" height="636" alt="image" src="https://github.com/user-attachments/assets/e6433c6c-69ac-486e-a1fa-9090a46052d1" />
  
  * 程式碼：
  ```verilog
  module top_module (
    input [31:0] a,
    input [31:0] b,
    output [31:0] sum
    );//
    
    wire k;
    wire cout_unused; // 用來接最後丟棄的進位

    // inst0 算出低 16 位，結果直接寫入 sum[15:0]
    add16 inst0(a[15:0], b[15:0], 1'b0, sum[15:0], k);
    
    // inst1 算出高 16 位，結果直接寫入 sum[31:16]
    add16 inst1(a[31:16], b[31:16], k, sum[31:16], cout_unused);

    endmodule

    module add1 ( input a, input b, input cin,   output sum, output cout );

    assign sum = (a ^ b) ^ cin;
    assign cout = a & b | a & cin | b & cin;// Full adder module here

    endmodule
  ```
  ### 解法：
  * **為補全最底層電路，將最底層寫的assign sum = a ^ b ^ cin;，透過中層的add16串 16次，最後再被top_module串了2次，最終在晶片上展開成一個巨大的 32 位元實體計算電路**
  * 題目用意在於：**模擬「底層 IP 不完整」的真實開發現狀、訓練「多層階層設計（Multi-level Hierarchy）」的思維**

## 關鍵知識/詞彙：
### if-else
* 由if開始，當判斷式成立時執行它的邏輯式，如果該判斷式不成立，則繼續看下一個else if的判斷式，直到某一個判斷式成立或是到達最後一個else。
* 有優先順序，按順序判斷，寫太深會影響電路速度
* 只能寫在always block裡，不論循序邏輯或是組合邏輯都可以（組合邏輯：blocking ；　循序邏輯：non-blocking）
* 組合邏輯裡的if-else要寫滿或是充當有預設值，不然會合出Latch

### clock gating
<img width="520" height="258" alt="image" src="https://github.com/user-attachments/assets/bae8818a-7af7-491f-b103-b26f397f130d" />

* Flip-Flop的clock觸發才會耗電，為節省電路功耗（省電），如果連續幾個cycle沒動作就把clock關掉，無觸發所以Q值不變
```verilog
always @(posedge clk) begin
    if (~rst_n) //reset為0（低態）觸發
        a <= 1'b0;
    else if (b)
        a <= 1'b1;
    else // 可以不寫最後這2行
        a <= a;
end
```

### case
* 只能寫在always block裡（循序、組合邏輯皆可）
* 當多選擇成立，則執行第一個成立的logic
* case、casez較常用，casez可用"?"、"z"表don't care
* 最後加default避免Latch，除非條件都寫滿
```verilog
case(狀態選擇)
    選擇1 : 邏輯式1:
    選擇2 : 邏輯式2:
    .
    .
    選擇n : 邏輯式n:
    default : 邏輯式x
endcase    
```

### for
* 只能寫在always block裡
* 迴圈條件須是固定值
* 每迴圈控制變量一定要能結束迴圈
* 常搭配array使用
```verilog
for (初始控制變量賦值; 迴圈條件; 每迴控制變量賦值) begin
    邏輯式;
end
```
* 陷阱
```verilog
module for_loop (
    input clk,
    input rst_n,
    output reg [7:0] z
);
integer i;
always @(posedge clk) begin
    if (~rst_n)
        z <= 1'b0;
    else begin
        for (i=0; i<8; i=i+1)
            z <= z + i; //不是把z值加上從1累加到7
    end
end
endmodule
```

### 遞延訊號
* 因為常需要根據pipline把需要的訊號延遲幾個cycle
* 例如某邊data path已經把值算出來，但另一邊卻要晚幾個cycle才準備好，所以可把需要的訊號延遲幾個cycle
```verilog
module pipe (
    input clk,
    input rst_n,
    input [7:0] a,
    output reg [7:0] z[8]
);
integer i;
always @(posedge clk) begin
    if (~rst_n) begin
        for (i=0; i<8; i=i+1)
            z[i] <= 1'b0;
    end
    else begin
        z[0] <= a;
        for (i=1; i<8; i=i+1)
            z[i] <= z[i-1]; //每個元素都會拿到前一個cycle值
    end
end
endmodule
```
<img width="737" height="228" alt="image" src="https://github.com/user-attachments/assets/9d222c2a-40cc-4148-91f3-f1a0f6d6e910" />

### generate
* 把電路依據控制變量產生"generate"多次（用寫程式的方式，幫你自動大量複製硬體電路、線路或模組）
* 搭配for迴圈使用，但控制變量需用"genvar"宣告
* 可產生組合、循序邏輯、module的實例化instantiate
```verilog
genvar geni;
generate
    for (初始控制變量賦值; 迴圈條件; 每迴控制變量賦值) begin
        要generate的邏輯式或是instantiate的module
    end
endgenerate
```
* 範例（批量實例化模組 (Module Instantiation)）：用 generate for 串聯 4 個全加器做成 4-bit 加法器：
```verilog
genvar i;
generate
    for (i = 0; i < 4; i = i + 1) begin: adder_block
        // 自動複製 4 個 full_adder 模組，並把引腳與索引值 i 綁定
        full_adder fa_inst (
            .a(a[i]),
            .b(b[i]),
            .cin(carry[i]),
            .sum(sum[i]),
            .cout(carry[i+1])
        );
    end
endgenerate
```

### 函數（function）
* 用來將組合邏輯打包起來，方便重複使用
* 只能寫在module裡，且只在該module裡有效
* 可以寫在module的任意地方，但建議寫在最後面
* 只能寫組合邏輯
* 都是用 blocking（＝）
* 至少一個輸入變量（input）
* 只能有一個返回值，沒有輸出
* function可以調用其他function。
```verilog
function [bitwidth-1:0] 返回變數; // 「返回變數」即為函數名
    input 宣告;
    其他變數宣告;
    begin
        邏輯式;
    end
endfunction
```

### 函數調用
* 需賦值給一個變數
* 可賦值給wire、reg、output
* 可在assign右邊，也可在always block裡的=、<=右邊
```verilog
assign Z = 函數名(input1, input2, ...);

always @(*)
    Z = 函數名(input1, input2, ...);

always @(posedge clk)
    Z <= 函數名(input1, input2, ...);
```
* EX.信號的前後位元反轉
```verilog
module test_func (
    input [7:0] a,
    output [7:0] z
);

assign z = revert(a);

function [7:0] revert;
    input [7:0] data_in;
    integer i;
    begin
        for(i=0; i<8; i=i+1) begin
            revert[7-i] = data_in[i];
        end
    end
endfunction

endmodule
```
<img width="1028" height="68" alt="image" src="https://github.com/user-attachments/assets/274cd8dd-74c6-4a1b-a03c-b43b4b29b6ec" />

* **有時候在互傳數據時，習慣有的會先傳高位，有的先傳低位**

### define
* 通常被用來定義一些常數或是程式碼的開關
* 可以橫跨所有 modules 和 Hierarchy
* 使用時於名稱前面加一撇（註：即反單引號 `）

| 特性 |  `define` (全球巨集) | `parameter` (局部參數) |
| --- | --- | --- |
| **語法關鍵字** | 開頭帶有反單引號，如 `'define DATA_WIDTH 8` | 正常宣告，如 `parameter DATA_WIDTH = 8;` |
| **作用範圍** | **全域（Global）**。只要在編譯順序中被讀取，其後所有的 `.v` 檔案、所有 Module 都能直接使用。 | **區域（Local）**。只在宣告它的該個 `module` 內部有效。 |
| **使用方式** | 呼叫時前面一定要加一撇： |  |

* EX
```verilog
`define A_BW 8
`define B_BW 4
`define Z_BW (`B_BW+`A_BW)

module test_define_1 (
    input [`A_BW-1:0] a,
    input [`B_BW-1:0] b,
    output [`Z_BW-1:0] z
);
assign z = a + b + `Z_BW*2;
endmodule
```
<img width="538" height="64" alt="image" src="https://github.com/user-attachments/assets/91351fab-1534-4bb7-bfe7-58012261b5af" />

### parameter
* 通常被用來定義一些常數或是 FSM state 的名稱
* 只在該module內有效，但可以在Hierarchy之間傳遞
* 使用時直接用名稱即可
* parameter必須有值，可以有算式，會計算好再使用。
* 語法1
```verilog
module m_name (input/output宣告);

parameter 名稱1 = 值1;
parameter 名稱2 = 值2;

endmodule
```

* 語法2
```verilog
module m_name #(
    parameter 名稱1 = 值1,
    parameter 名稱2 = 值2
)(
    input/output宣告
);
```

* 使用一（module內）：名稱
* 使用二（傳值）：
```verilog
#(.名稱1(新值1), .名稱2(新值2))
instant_name(IO連線)
```
* EX
```verilog
module test_parameter_0#(
    parameter A_BW = 8,
    parameter B_BW = 4,
    parameter Z_BW = B_BW + A_BW
)
(
    input [A_BW-1:0] a,
    input [B_BW-1:0] b,
    output [Z_BW-1:0] z
);

assign z = a + b + Z_BW*2;

endmodule

module test_top (
    input [6:0] in1,
    input [2:0] in2,
    output [9:0] out1
);

test_paramter_0 #(.A_BW(7), .B_BW(3)) //將A、B的值改變，驗證可在Hierarchy之間傳遞
 u_test_para (.a(in1), .b(in2), .z(out1));

endmodule
```
<img width="857" height="99" alt="image" src="https://github.com/user-attachments/assets/d838dbc9-fddc-4462-bb0f-85065e9d300a" />

* **state machine建議都使用parameter來寫，可讀性較高**

### define 與 parameter 有什麼不同？
| 特性 | define (全球巨集) | parameter (局部參數) |
| --- | --- | --- |
| **語法關鍵字** | 開頭帶有反單引號，如 define DATA_WIDTH 8 | 正常宣告，如 parameter DATA_WIDTH = 8; |
| **作用範圍** | **全域（Global）**。只要在編譯順序中被讀取，其後所有的 .v 檔案、所有 Module 都能直接使用。 | **區域（Local）**。只在宣告它的該個 module 內部有效。 |
| **使用方式** | 呼叫時前面一定要加一撇 | |

[回目錄](#toc)

---

<a id="m07d06"></a>

## 2026 年 7 月 6 日

## 今日進度：
### 刷題：完成 HDLBits 的 "carry-slect Adder" 到 "a priority encoder for 8-bit inputs"。

## 遇到的困難與解決方案：
### 問題：
* carry-slect Adder（選擇式加法器）
* **使用的位元範圍q0[31:16]、q1[31:16]超出了它原本宣告的[15:0]範圍，位元寬度（或範圍）越界錯誤導致編譯錯誤。**
<img width="551" height="376" alt="image" src="https://github.com/user-attachments/assets/0530f38b-d2fe-4996-aa6c-43adb3870768" />

* 原程式碼：
  ```verilog
  module top_module(
    input [31:0] a,
    input [31:0] b,
    output [31:0] sum
    );
    //module add16 ( input[15:0] a, input[15:0] b, input cin, output[15:0] sum, output cout );
    
    wire k;
    wire [15:0] q0,q1;
    add16 inst0(
        .a(a[15:0]),
        .b(b[15:0]),
        .cin(1'b0),
        .cout(k),
        .sum(sum[15:0])
    );
    
    add16 inst1(
        .a(a[31:16]),
        .b(b[31:16]),
        .cin(1'b0),
        .cout(),
        .sum(q0[31:16]) //位元寬度（或範圍）越界錯誤
    );
    
    add16 inst2(
        .a(a[31:16]),
        .b(b[31:16]),
        .cin(1'b1),
        .cout(),
        .sum(q1[31:16]) //位元寬度（或範圍）越界錯誤
    );
    
    always@(*)begin
        case(k)
            1'b0 : sum[31:16] = q0;
            1'b1 : sum[31:16] = q1;
        endcase
    end

    endmodule
    ```
  
### 解法：
* **修正q0、q1在inst1、inst2中的位元寬度**
  ```verilog
      add16 inst1(
        .a(a[31:16]),
        .b(b[31:16]),
        .cin(1'b0),
        .cout(),
        .sum(q0[15:0]) //[31:16]修正為[15:0]，雖同為 16 bits，但宣告範圍僅在 [15:0]
    );
    
    add16 inst2(
        .a(a[31:16]),
        .b(b[31:16]),
        .cin(1'b1),
        .cout(),
        .sum(q1[15:0]) //[31:16]修正為[15:0]，雖同為 16 bits，但宣告範圍僅在 [15:0]
    );
  ```
## 關鍵知識/詞彙：
### 優先編碼器
* 一種組合邏輯電路。當輸入一個多位元的向量（Vector）時，如果有多個位元同時為1，它會根據內定的優先權（通常是「最高位元優先」或「最低位元優先」），只輸出那第一個出現的1的二進位位置。
* 程式碼範例（4-bit priority encoder）：
<img width="943" height="105" alt="image" src="https://github.com/user-attachments/assets/00830233-3492-4dec-89df-450df98e20ef" />

  ```verilog
    module top_module (
    input [3:0] in,
    output reg [1:0] pos  );
    
    always @(*) begin
        if(in[0]) //當最低有效為為1，則輸出位置在q0,ex0001
            pos = 0;
        else if(in[1]) //ex.0010、0011（q0：don't care，有效位數較低）
            pos = 1;
        else if(in[2])
            pos = 2;
        else if(in[3])
            pos = 3;
        else
            pos = 0;
    end

    endmodule
  ```
  * 程式碼範例（a priority encoder for 8-bit inputs）：
    ```verilog
    // synthesis verilog_input_version verilog_2001
    module top_module (
    input [7:0] in,
    output reg [2:0] pos );
    
    always@(*)begin
        casez(in[7:0])
          8'bzzzzzzz1 : pos = 0;
          8'bzzzzzz1z : pos = 1;
          8'bzzzzz1zz : pos = 2;
          8'bzzzz1zzz : pos = 3;
          8'bzzz1zzzz : pos = 4;
          8'bzz1zzzzz : pos = 5;
          8'bz1zzzzzz : pos = 6;
          8'b1zzzzzzz : pos = 7;
          default : pos = 0;
        endcase
    end

    endmodule
    ```

[回目錄](#toc)

---

<a id="m07d07"></a>

## 2026 年 7 月 7 日

## 今日進度：
### 影片：[清大OCW王俊堯教授數位邏輯設計第 8B~8E ](https://www.youtube.com/watch?v=fW6xAPTOMm0&list=PLS0SUwlYe8czJbz5-sRtbuTleObQE9mOa)
### 資料：複習7/3 - 7/6進度。
### 刷題：複習7/3 - 7/6進度、完成 HDLBits 的 "Always nolatches" 到 "Create a 100-bit binary ripple-carry adder"。

## 遇到的困難與解決方案：
### 問題：
* Create a 100-bit binary ripple-carry adder
* **將module寫在module中、迴圈內呼叫的模組名稱寫錯導致編譯錯誤**
* 原程式碼
  ```verilog
  module top_module( 
    input [99:0] a, b,
    input cin,
    output [99:0] cout,
    output [99:0] sum 
    );
    
    add1 inst0(
        .a(a[0]),
        .b(b[0]),
        .cin(cin),
        .sum(sum[0]),
        .cout(cout[0])
    );
    
    genvar i;
	generate
        for (i=1 ; i<100 ; i++) begin : full_adder100
            add100 addi(　//呼叫名稱錯誤
                .a(a[i]),
                .b(b[i]),
                .cin(cout[i-1]),
                .sum(sum[i]),
                .cout(cout[i])
            );
    	end
	endgenerate

    module add1( //module需是獨立的
        input a, b,
        input cin,
        output cout,
        output sum
    );
        assign sum = a ^ b ^ cin;
    	assign cout = a & b | b & cin | a & cin;
        
     endmodule
    
    endmodule
  ```
  
### 解法：
* **每個模組都必須是獨立的個體**，把module add1的整段程式碼，移到top_module的endmodule外
* 把迴圈內部的 add100 改成 add1（最下面定義的基礎 1-bit 全加器名字叫做 add1）
* 修正後程式碼
```verilog
module top_module( 
    input [99:0] a, b,
    input cin,
    output [99:0] cout,
    output [99:0] sum 
);
    
    add1 inst0( // 第 0 級全加器：手動連接初始的 cin
        .a(a[0]),
        .b(b[0]),
        .cin(cin),
        .sum(sum[0]),
        .cout(cout[0])
    );
    
    genvar i;
	generate
        for (i=1 ; i<100 ; i++) begin : full_adder100 // 第 1 到 99 級全加器：利用 generate 迴圈自動串聯
            add1 addi(
                .a(a[i]),
                .b(b[i]),
                .cin(cout[i-1]),
                .sum(sum[i]),
                .cout(cout[i])
            );
    	end
	endgenerate

endmodule

module add1(
        input a, b,
        input cin,
        output cout,
        output sum
    );
        assign sum = a ^ b ^ cin;
    	assign cout = a & b | b & cin | a & cin;
        
 endmodule
```
## 關鍵知識/詞彙：
### Active Low
* 數位電路與晶片設計中，設計師確實非常偏愛使用**低態觸發 / 低電平有效（Active Low）**，由**硬體製程、電路特性以及抗干擾能力**等底層因素共同決定。
* 整理：

| 觸發方式 | 晶片負擔 | 抗干擾度 | 斷線安全（保護類訊號） | 多元件共享線路 |
| --- | --- | --- | --- | --- |
| **低態觸發（Active Low）** | **輕**（灌電流能力強） | **高**（對地低阻抗） | **高**（電壓崩潰時自動觸發保護） | **極易**（直接線與連結） |
| **高態觸發（Active High）** | **重**（拉電流能力弱） | **較低** | 較低 | 困難（需額外加邏輯閘） |

### Hazard
* 因為**硬體元件的物理延遲或設計缺陷**，導致電路在某個瞬間產生錯誤輸出（毛邊），或是讓處理器讀取到錯誤資料
  
* 分類
    * Static Hazard：輸入改變後，原本預期要維持穩定的輸出，卻在中間短暫跳變。
        * Static 1-Hazard：預期維持 1，中間卻掉了下去（1 → 0 → 1）。
        * Static 0-Hazard：預期維持 0，中間卻彈了上來（0 → 1 → 0）。
    * Dynamic Hazard：預期要從 0 變 1（或 1 變 0），但因為多條路徑延遲，輸出沒有一次到位，而是跳動了多次（0 → 1 → 0 → 1）。
      
* 防範方式
    * 加入冗餘項 (Redundant Terms / Hazard Cover)：利用卡諾圖（Karnaugh Map）圈選相鄰群組時，在兩個群組的交界處額外多圈一個「冗餘乘積項」（卡諾圖上的圈圈重疊）。多出來的邏輯閘能確保當輸入訊號在兩組之間切換時，輸出不會因為延遲而掉下去。
    * 改用同步時序電路 (Design Synchronous Logic)：現代 IC 設計最核心的解法。不要直接使用組合邏輯的輸出作為下一個電路的觸發訊號。在組合邏輯後面接一個正反器（Flip-Flop），並由全域時脈（Clock）控制。因為**毛邊只會發生在時脈週期的中間**，只要我們確保在時脈邊緣（Setup Time / Hold Time）來臨時訊號已經穩定，正反器就不會鎖存到毛邊。

[回目錄](#toc)

---

<a id="m07d08"></a>

## 2026 年 7 月 8 日

## 今日進度：
### 資料：複習7/3 - 7/7進度。
### 刷題：複習7/3 - 7/7進度、完成 HDLBits 的 "100-digit BCD ripple-carry adder（100 位的 BCD 級聯加法器）"。

## 遇到的困難與解決方案：
### 問題：
* Create a 100-digit BCD ripple-carry adder
* **Module埠宣告中，cout被定義成一個"只有 1 位元的單一導線"，沒有維度可以使用中括號 [] 去指定索引**，所以編譯錯誤
* 原程式碼
  ```verilog
	module top_module( 
    input [399:0] a, b,
    input cin,
    output cout,
    output [399:0] sum );
      
    bcd_fadd inst0(
        .a(a[3:0]),
        .b(b[3:0]),
        .cin(cin),
        .sum(sum[3:0]),
        .cout(cout[0]) //沒辦法指定索引值
    );
    
    genvar i;
    generate
        for(i=1; i<100; i++)begin : digst100
            bcd_fadd insti(
                .a(a[(4*i)+3:(4*i)]),
                .b(b[(4*i)+3:(4*i)]),
                .cin(cout[i-1]),
                .sum(sum[(4*i)+3:(4*i)]),
                .cout(cout[i]) //沒辦法指定索引值
            );
        end
    endgenerate
       
	endmodule
  ```
* 第一次修正後程式碼（加100條內部進位線cout -> cin）
* **內部串聯的最後一個進位訊號cout_temp[99]無傳送給輸出埠cout**再次編譯錯誤
  ```verilog
    module top_module( 
    input [399:0] a, b,
    input cin,
    output cout,
    output [399:0] sum );
    
    wire [99:0]cout_temp; //加100條內部進位線cout_temp[i] -> cin[i+1]
    
    bcd_fadd inst0(
        .a(a[3:0]),
        .b(b[3:0]),
        .cin(cin),
        .sum(sum[3:0]),
        .cout(cout_temp[0])
    );
    
    genvar i;
    generate
        for(i=1; i<100; i++)begin : digst100
            bcd_fadd insti(
                .a(a[(4*i)+3:(4*i)]),
                .b(b[(4*i)+3:(4*i)]),
                .cin(cout_temp[i-1]),
                .sum(sum[(4*i)+3:(4*i)]),
                .cout(cout_temp[i])
            );
        end
    endgenerate

	endmodule
  ```  
### 解法：
* 修正後程式碼（加100條內部進位線；cout_temp[99]傳送給輸出埠cout）
```verilog
  module top_module( 
    input [399:0] a, b,
    input cin,
    output cout,
    output [399:0] sum );
    
    wire [99:0]cout_temp; //加100條內部進位線cout_temp[i] -> cin[i+1]
    
    bcd_fadd inst0(
        .a(a[3:0]),
        .b(b[3:0]),
        .cin(cin),
        .sum(sum[3:0]),
        .cout(cout_temp[0])
    );
    
    genvar i;
    generate
        for(i=1; i<100; i++)begin : digst100
            bcd_fadd insti(
                .a(a[(4*i)+3:(4*i)]),
                .b(b[(4*i)+3:(4*i)]),
                .cin(cout_temp[i-1]),
                .sum(sum[(4*i)+3:(4*i)]),
                .cout(cout_temp[i])
            );
        end
    endgenerate
    
    assign cout = cout_temp[99]; //cout_temp[99]傳送給輸出埠cout

	endmodule
```
## 關鍵知識/詞彙：
### Create a 100-digit BCD ripple-carry adder
* 更好的撰寫方式（減少編譯器的剖析樹（Parse Tree）深度、編譯時間，因為消除了硬體算術公式）
  ```verilog
  module top_module( 
    input [399:0] a, b,
    input cin,
    output cout,
    output [399:0] sum 
	);
    
    wire [99:0] cout_temp; // 100 級的內部進位線
    
    //直接平行宣告 100 個 bcd_fadd 實例
    // 語法結構：模組名 實例名 [範圍] ( 埠接線 );
    bcd_fadd inst [99:0] (
        .a(a),                // 自動將 400-bit 對應到 100 個 4-bit 輸入
        .b(b),                // 自動將 400-bit 對應到 100 個 4-bit 輸入
        .cin({cout_temp[98:0], cin}), // 關鍵：把前 99 個進位與初始 cin 串起來當作 100 個 cin
        .sum(sum),            // 自動將 400-bit 對應到 100 個 4-bit 輸出
        .cout(cout_temp)      // 100 個進位輸出直接接給 cout_temp
    );
    
    assign cout = cout_temp[99]; // 將最後一級的進位送給頂層

	endmodule
  ```
  
* bcd_fadd模組程式碼
  ```verilog
  module bcd_fadd (
    input [3:0] a,     // 4-bit BCD 數字 (0~9)
    input [3:0] b,     // 4-bit BCD 數字 (0~9)
    input cin,         
    output cout,       
    output [3:0] sum   
	);

    reg [4:0] sum_temp; //設計5-bit寬度是為了捕捉最高進位，防止4-bit溢位 (最大值：9 + 9 + 1 = 19)

    always @(*) begin
        sum_temp = a + b + cin;
        
        //判斷有沒有超過十進位的9，超過需加6
        if (sum_temp > 5'd9) begin
            sum  = sum_temp + 5'd6; // 超過9，加6
            cout = 1'b1;            // 產生 BCD 進位
        end else begin
            sum  = sum_temp[3:0];   // 沒超過 9，直接當作結果
            cout = 1'b0;            // 不進位
        end
    end

	endmodule
  ```

[回目錄](#toc)

---

<a id="m07d09"></a>

## 2026 年 7 月 9 日

## 今日進度：
### 影片：[看財經村長-數位IC設計面試 ](https://www.youtube.com/watch?v=yATdPIrKdug&t=2092s)
### 刷題：完成 HDLBits - "Combinational Logic" 中的 "Basic gates"。

## 遇到的困難與解決方案：
### 問題：
* Ringer
* **用軟體思維來寫硬體**
* 原程式碼：
  ```verilog
  module top_module (
    input ring,
    input vibrate_mode,
    output ringer,       // Make sound
    output motor         // Vibrate
	);

    assign ringer = (ring == 1'b1 && vibrate_mode == 1'b0) ? 1'b1 : 1'b0; //響鈴條件：有來電 (ring) 且 沒有開啟震動模式 (not vibrate_mode)
    assign motor = (ring == 1'b1 && vibrate_mode == 1'b1) ? 1'b1 : 1'b0; //震動條件：有來電 (ring) 且 開啟了震動模式 (vibrate_mode)
    
	endmodule
  ```
  * Gatesv(數位訊號處理與向量切片（Vector Slicing）練習)
  * 題目要求out_different檢查自己與左邊鄰居是否不同，in[3]的左邊是in[0]，但程式碼未將in[3]、in[0]做比較而導致編譯錯誤（位元寬度不匹配）
<img width="960" height="246" alt="image" src="https://github.com/user-attachments/assets/e2810095-f470-4a6b-b27d-3914b8dbbbb6" />

  * 原程式碼
  	```verilog
   	module top_module( 
    input [3:0] in,
    output [2:0] out_both,
    output [3:1] out_any,
    output [3:0] out_different );
    
    assign out_both = in[3:1] & in[2:0]; //檢查自己與左邊鄰居是否皆為 1 (3-bit 輸出)
    assign out_any = in[3:1] | in[2:0]; //檢查自己與右邊鄰居是否任一為 1 (3-bit 輸出，注意左側宣告是 [3:1])
    assign out_different = in[3:1] ^ in[2:0]; //位元寬度不匹配

	endmodule
  	```
   
### 解法：
* Ringer（更好的寫法）
* **業界**更推崇的精簡寫法：**直接使用邏輯閘**，**直接寫邏輯運算子**，腦海中可以直接浮現出電路圖。
* 修改後程式碼
```verilog
module top_module (
    input ring,
    input vibrate_mode,
    output ringer,       
    output motor         
);

    assign ringer = ring & ~vibrate_mode; //ring 獨立出現，就代表 ring == 1'b1；~vibrate_mode，就代表 vibrate_mode == 1'b0。
    assign motor = ring & vibrate_mode; 
    
endmodule
```
* Gatesv(數位訊號處理與向量切片（Vector Slicing）練習)
* out_different前三個位元 [2:0]：正常跟左邊鄰居比較（不用環繞），最高位元 [3]：單獨拉出來跟 in[0] 做環繞比較。
* 修改後程式碼
  ```verilog
  module top_module( 
    input [3:0] in,
    output [2:0] out_both,
    output [3:1] out_any,
    output [3:0] out_different );
    
    assign out_both = in[3:1] & in[2:0];
    assign out_any = in[3:1] | in[2:0];
    assign out_different[2:0] = in[3:1] ^ in[2:0];
    assign out_different[3] = in[3] ^ in[0];

	endmodule
  ```

## 關鍵知識/詞彙：
### Latch、Flip-flop根本差異
* Latch（平緣觸發）
  * 當控制信號(clk)處於有效電平時，Latch會持續追蹤輸入端的變化，並將這些變化反映到輸出端。
    
* Flip-flop（邊緣觸發）
  * 只在時鐘信號的特定邊緣(上升沿或下降沿)捕捉輸入資料，並在該瞬間更新輸出。

### Latch的電路實現與HDL描述
<img width="196" height="286" alt="image" src="https://github.com/user-attachments/assets/60c7747b-b0f1-46a7-b6f7-c8995f339fe5" />

```verilog
module d_latch (
     input   rst_n,
     input   en,
     input   d,
     output  q
);

// 1. (!rst_n) -> 低電平重設，輸出 0
// 2. (en)     -> 致能開啟，輸出 d (隨輸入變動)
// 3. : q      -> 致能關閉，維持原值 (鎖存狀態)

	assign q = (!rst_n) ? 0 : (en) ? d : q;

 endmodule
```

### Setup Time與Hold Time的定義與重要性
<img width="400" height="158" alt="image" src="https://github.com/user-attachments/assets/5220f383-c71d-47c3-b344-c70dfdb6acbb" />

* Setup Time
  * Setup time(Tsu)是指在時鐘有效邊緣(例如上升沿)到來之前，資料輸入端(D)的信號必須保持穩定不變的最短時間。確保Flip-flop內部的主Latch能夠正確地採樣並鎖存輸入資料。
  * Setup time的長短取決於Flip-flop內部電路的速度特性。
  
* Hold Time
  * Hold time(Th)是指在時鐘有效邊緣(例如上升沿)到來之後，資料輸入端(D)的信號必須繼續保持穩定不變的最短時間。確保Flip-flop能夠完全穩定地鎖存資料，新資料不會過早到達而破壞正在被捕捉的資料。
  * 通常比setup time短得多
  * Hold violation(保持時間違規)發生在資料路徑延遲太短，新資料過早到達的情況。與時鐘週期無關，通常需要透過插入延遲(如buffer)來修復。

### clock skew（時鐘偏斜的影響與計算）
<img width="231" height="239" alt="image" src="https://github.com/user-attachments/assets/15418ac1-440d-420c-8644-a10223246c89" />
<img width="337" height="313" alt="image" src="https://github.com/user-attachments/assets/ba0c8bac-59a2-4208-9c7e-76f5280483e4" />


* 同一個時脈源發出的訊號，到達晶片內不同觸發器（Flip-Flop）的時間差。
  
* 為甚麼會產生
  * 距離不同：有的觸發器離時脈輸入端（Clock Source）很近，有的拉了幾毫米遠。
  * 電阻電容（RC Delay）：金屬佈線本身有電阻和電容，線越長，訊號傳得越慢。（電容充電時間）
  * 緩衝器（Buffer）數量不同：為了推動大量硬體，時脈線上會加很多 Buffer，這也會帶來延遲。

* 對電路影響
  * 導致 Setup Time（建立時間）違規 ── 晶片跑不快
    * 如果後級的觸發器比前級「晚」收到時脈，前級提早變更資料，後級可能來不及發出正確訊號。
  * 導致 Hold Time（保持時間）違規 ── 晶片直接報廢
    * 如果後級的觸發器比前級「早」收到時脈，前級剛吐出的新資料可能會在後級還沒鎖存舊資料前，就直接衝過去把舊資料洗掉
    
* 如何解決
  * 建立「時鐘樹」（Clock Tree Synthesis, CTS）
    * 不能像接延長線那樣一條線拉到底，必須像大樹的樹枝一樣，確保從樹幹（主時脈）到每個樹葉（觸發器）的路徑 長度、Buffer 數量和負載完全對稱。
  * Clock Gating

* 設計實踐
  * 在實際專案中，時鐘樹設計通常佔用顯著的佈線資源和功耗。良好的時鐘樹設計不僅要控制skew，還要考慮功耗、面積、可測試性等多個維度。
 
### setup time violation 修復策略 1 - 增加clk週期（降頻）
* 優點：實施簡易
* 缺點：降低系統整體工作頻率、效能，設計中往往是最終選擇的方案

### setup time violation 修復策略 2 - 插入流水線暫存器(Pipelining)
<img width="453" height="265" alt="image" src="https://github.com/user-attachments/assets/627fc495-9eba-49e8-91e5-33d86bc13a93" />

* 在長的組合邏輯路徑中間插入額外的Flip-Flop，將一個長路徑分割成多個短路徑，從而減少每段的 data path delay
* 優點：可以顯著提高最大工作頻率，是高性能設計的標準做法。可以讓多個資料同時在不同階段處理，提高吞吐量
* 缺點：增加了資料的延遲週期(latency)，從輸入到輸出需要更多時鐘週期，還會增加面積和功耗，並可能使控制邏輯變得更複雜。
* 設計考量：切割點需要仔細選擇（有沒有辦法算出正確的值），要在邏輯的自然邊界處切割，避免造成組合邏輯的不平衡。

### setup time violation 修復策略 3
### Buffer插入與邏輯複製
* 當critical path上某個節點的負載(fanout)過大，導致驅動能力不足、轉換時間變慢、net delay增加時，可以採用兩種技術：
  * Buffer Insertion (插入緩衝器)：在長線路或高fanout節點插入repeater buffer，分段驅動負載，減少整體延遲。（能夠提供額外驅動能力，還能降低線路的RC延遲效應）
  * Logic Replication (邏輯複製)：複製產生高fanout信號的邏輯gate，讓每個副本驅動部分負載，從而減少單一gate的負擔。
* 權衡考量：Buffer insertion會增加面積和功耗，而logic replication則會增加更多面積(因為複製了邏輯)。

### Cell Sizing／Gate Upsizing
* 當timing report顯示cell delay佔比較大(而非net delay)，表示gate本身的驅動能力不足。解決方法是將標準單元庫中的小尺寸cell替換為大尺寸cell
* 作用機制：更大的cell具有更寬的電晶體通道，能提供更大的驅動電流，加快輸出轉換速度，降低cell delay。
* 大尺寸cell會增加面積、輸入電容(可能影響前級timing)、和功耗。（針對critical path上delay最大的幾個cell進行選擇性upsizing即可）

### 更換Vt類型(Threshold Voltage Tuning)
* LVT (Low-Vt)：速度最快(延遲最小)，但漏電流最大，靜態功耗高
* SVT (Standard-Vt)：性能與功耗的折衷選擇
* HVT (High-Vt)：速度最慢，但漏電流最小，適合非關鍵路徑
* 代價與風險：
  * 漏電功耗大幅上升，影響待機功耗和總功耗預算
  * Cell變快可能使hold time更緊張，因為最小路徑延遲減小
  * 可能加劇IR drop問題和on-chip variation，在某些corner下反而更差
  * 影響yield，因為LVT cell對製程變異更敏感。
* 最佳實踐：採用multi-Vt設計策略：critical path用LVT，非關鍵路徑用HVT，大部分用SVT。

### setup time violation 修復策略 4
### 時鐘偏斜優化(Clock Skew Scheduling)
* 刻意調整 clock skew，可以在不改變電路結構的情況下改善 timing。對於 setup violation，可以引入 positive skew，讓 capture FF 的時鐘稍微延遲到達，給予資料更多傳播時間。

### 邏輯重構(Logic Restructuring)
* 透過重新組織組合邏輯的結構來減少延遲，例邏輯分解(factoring)、critical path 的優先運算等

### 實體設計優化(Physical Design)
* 將相關的 cell 放得更近、使用較低層的金屬層以減少電阻、避開擁擠區域、使用更寬的線等

### **綜合性的優化策略**
* 一般的優化流程：
  * 先做大架構層面的改動：如增加流水線、降頻(如果可行)、重新 partition 模組等
  * 再做RTL 層級的優化：如邏輯重構、減少組合邏輯深度、優化狀態機等
  * 最後在 P&R 階段做細部調整：包括 gate sizing、buffer insertion...
  * 迭代優化：時序優化是迭代過程。修復一處 violation 可能在別處產生新的問題

### critical path
* 晶片內所有邏輯路徑中，訊號傳遞速度最慢、延遲（Delay）最長的那一條路徑

### hold time violation 修復策略 1 - 增加資料路徑延遲
* Hold violation與setup violation本質上相反；setup是資料來得太慢，hold是資料來得太快或變化得太早
* Hold violation與時鐘週期無關（頻率降到很低，hold問題依然存在）
* hold violation通常被認為比setup violation更嚴重（降頻無法修）
* **增加資料路徑延遲**可讓新資料晚一點到達capture FF

### hold time violation 修復策略 2
### 插入延遲元件
* 插入Buffer：在資料路徑上插入一個或多個 buffer，增加 propagation delay
* 插入位置：通常在 launch FF 的輸出端或組合邏輯路徑的早期階段插入（同時影響所有由該 FF 驅動的路徑）
* 插入Delay Cell：標準單元庫通常提供專用的 delay cell（如 DELAY、DELLN 等），這些 cell 專門用於增加延遲而不改變邏輯功能（相比普通 buffer、delay cell 有更可預測的延遲特性）
* 注意事項：增加面積和功耗（尤其是動態功耗）。

### 調整時鐘偏斜
* 減小 clock skew，甚至引入 negative skew（讓 capture FF 的時鐘提前到達），可以給資料更多的保持時間。
* 注意事項：調整 skew 會同時影響 setup 和 hold timing，需要做好 clock tree 的 balance。

### 插入 Lock-up Latch
* 在路徑中插入一個低電平有效的 Latch。在時鐘的高電平期間，latch 處於保持狀態，輸出不變；在低電平期間，latch 透明，資料通過。
* 注意事項：Lock-up latch 會增加 data latency（半個週期），並增加面積和功耗。

### Hold Fix的最佳實踐
* 實際設計流程中，hold violation的修復通常在P&R的後期階段進行，因為：
  * Hold timing對實際的placement和routing非常敏感,只有在physical design確定後,才能準確評估hold violations
  * 現代P&R工具通常有自動的hold fixing功能,會在post-CTS或post-route階段自動插入所需的buffer/delay cell
  * Hold fix通常是最後的收尾工作，在setup timing基本達標後才進行大規模的hold fixing。
  * 設計者需要在設定P&R constraints時,給予工具足夠的buffer insertion彈性，並在chip finishing階段仔細檢查hold fix的結果，確保沒有過度修復(over-fixing)或遺漏關鍵路徑。

[回目錄](#toc)

---

<a id="m07d10"></a>

## 2026 年 7 月 10 日

## 今日進度：
### 資料：複習7/3 - 7/9內容。
### 刷題：複習 HDLBits 的 "Modules" 到 "Basic Gates"；完成 HDLBits - Arithmetic circuits 的 half adder 到 signed addition overflow。

## 遇到的困難與解決方案：
### 問題：誤解溢位判斷。
### 解法：
### 溢位只會發生在「這兩種情況」
* 正數 ＋ 正數 ＝ 變成負數（正溢位）
* 負數 ＋ 負數 ＝ 變成正數（負溢位）

### 溢位
* 專指「有號數（Signed Number）」在進行加減法運算時，因為答案太大或太小，導致 8-bit 的空間裝不下，進而使「符號位元（Sign bit）」被錯誤篡改的硬體災難。

### 今日例題 - signed addition overflow
```verilog
module top_module (
    input [7:0] a,
    input [7:0] b,
    output [7:0] s,
    output overflow
); //

    assign s = a + b;// 兩數相加
    assign overflow = ~(a[7] ^ b[7]) & (a[7] ^ s[7]);// 判斷溢位：最高位元同為1 or 0且與最高輸出位元數字相反

endmodule
```

## 關鍵知識/詞彙：
### Variable index　變數索引（為什麼「變數索引」在硬體裡是巨大的 MUX？）
* 在寫 C++ 或 Python 時，data[index] 只是叫 CPU 去記憶體某個地址「看一眼」，記憶體很大、index 再大也沒差。
* 晶片不是軟體，晶片是「用金屬線焊死」的電路板！。如果電路是 out = data[index]，這代表硬體必須做到：「不論 index 傳進來是多少，out 都要能拿到對應的資料。」（不可以有空的資料）
* 當 data 的範圍很大時，晶片的速度（時脈頻率）會被拖垮！

### Variable part-select 變數局部選擇（變數動態切片 +: 與 -:）
* 在硬體設計中，合成器有一個死命令：「拉出來的總線（Bus），在晶片做出來時，有幾根銅線必須是確定的！」
* 假設寫 out = data[index : index+3]：
  * 冒號左右兩邊都有變數（index 和 index+3），在數學解析上會判定「這個範圍的寬度可能隨時在變」，導致編譯錯誤
* 正確寫法（焊死寬度，只動起點）
  * data[起點 +: 寬度] or data[起點 -: 寬度]
  * "+"代表從起點往高位元數 4 個；"-"代表從起點往低位元數 4 個
* 今日範例程式 256-to-1 multiplexer
  ```verilog
  module top_module( 
    input [1023:0] in,
    input [7:0] sel,
    output [3:0] out );
    
    assign out = in[sel*4 +: 4]; //選出 1024bit 資料中，某位置的 4bit 資料

	endmodule
  ```   

[回目錄](#toc)

---

<a id="m07d11"></a>

## 2026 年 7 月 11 日

## 今日進度：
### 資料：複習7/3 - 7/10內容。
### 刷題：複習 HDLBits 的 "Modules" 到 "multiplexers"；完成 HDLBits - Arithmetic circuits。

## 遇到的困難與解決方案：
### 問題：create a 4-digit BCD ripple-carry adder
* 在做賦值後出現寬度截斷警告（Truncation Warning）。
* 原程式碼：
  ```verilog
  module top_module ( 
    input [15:0] a, b,
    input cin,
    output cout,
    output [15:0] sum );
    
    wire [3:0]k;
    bcd_fadd inst0(
        .a(a[3:0]),
        .b(b[3:0]),
        .cin(cin),
        .sum(sum[3:0]),
        .cout(k[0])
    );
    
    genvar i;
    generate
        for(i=1; i<4; i++)begin : bcd_adder16
            bcd_fadd insti(
                .a(a[4*i+3 : 4*i]), //等號右邊算出來的結果是一個 32-bit 整數，但等號左邊的接收目標寬度卻只有 4-bit
                .b(b[4*i+3 : 4*i]), //等號右邊算出來的結果是一個 32-bit 整數，但等號左邊的接收目標寬度卻只有 4-bit
                .cin(k[i-1]),
                .sum(sum[4*i+3 : 4*i]),//等號右邊算出來的結果是一個 32-bit 整數，但等號左邊的接收目標寬度卻只有 4-bit
                .cout(k[i])
            );
        end
    endgenerate
    
    assign cout = k[3];

	endmodule
  ```
  
  * 編譯器強會行把高位元的 28 個 bit 全部丟棄，只留下最低的 4 個 bit。
### 解法：
### 改用變數動態切片 +: 與 -: 撰寫，明確告訴編譯器「起點是 4*i，寬度死死就是 4」
* 修改後程式碼
  ```verilog
  module top_module ( 
    input [15:0] a, b,
    input cin,
    output cout,
    output [15:0] sum );
    
    wire [3:0]k;
    bcd_fadd inst0(
        .a(a[3:0]),
        .b(b[3:0]),
        .cin(cin),
        .sum(sum[3:0]),
        .cout(k[0])
    );
    
    genvar i;
    generate
        for(i=1; i<4; i++)begin : bcd_adder16
            bcd_fadd insti(
                .a(a[4*i +: 4]), //動態切片 +: 與 -: 撰寫
                .b(b[4*i +: 4]), //動態切片 +: 與 -: 撰寫
                .cin(k[i-1]),
                .sum(sum[4*i +: 4]), //動態切片 +: 與 -: 撰寫
                .cout(k[i])
            );
        end
    endgenerate
    
    assign cout = k[3];

	endmodule
  ```

## 關鍵知識/詞彙：
### 16-bit BCD_adder
* 雖編譯成功且執行結果正確，但在硬體描述語言中踩到了「一線多接（Multiple Drivers）」的語法地雷！
* 雖然在某些極端寬容的編譯器可以過，但在很多標準的 Linter（語法檢查器）或 HDLBits 的環境中，將最後一級同時接到內部陣列又透過 assign 指定的方式，容易導致陣列邊界混淆或多重驅動判定錯誤。
* 原程式碼：
  ```verilog
  module top_module ( 
    input [15:0] a, b,
    input cin,
    output cout,
    output [15:0] sum );
    
    wire [3:0]k;
    bcd_fadd inst0(
        .a(a[3:0]),
        .b(b[3:0]),
        .cin(cin),
        .sum(sum[3:0]),
        .cout(k[0])
    );
    
    genvar i;
    generate
        for(i=1; i<4; i++)begin : bcd_adder16
            bcd_fadd insti(
                .a(a[4*i +: 4]),
                .b(b[4*i +: 4]),
                .cin(k[i-1]),
                .sum(sum[4*i +: 4]),
                .cout(k[i]) //k[3] 被千位數加法器的 .cout(k[3]) 驅動（塞資料進去）。
            );
        end
    endgenerate
    
    assign cout = k[3]; //同時又宣告了 assign cout = k[3];

	endmodule
  ```
  
* 更好的撰寫方式
  ```verilog
  module top_module ( 
    input [15:0] a, b,
    input cin,
    output cout,
    output [15:0] sum 
	);
    
    // 宣告 5 根進位線（k[0] 到 k[4]）
    wire [4:0] k;
    
    // 把頭尾焊死接到頂層介面
    assign k[0] = cin;
    assign cout = k[4];
    
    genvar i;
    generate
        for(i=0; i<4; i++) begin : bcd_adder16
            bcd_fadd insti(
                .a(a[4*i+3 : 4*i]),
                .b(b[4*i+3 : 4*i]),
                .cin(k[i]),       // i=0 時就是 cin
                .sum(sum[4*i+3 : 4*i]),
                .cout(k[i+1])     // i=3 時輸出給 k[4]，就是 cout
            );
        end
    endgenerate

	endmodule
  ```

[回目錄](#toc)

---

<a id="m07d13"></a>

## 2026 年 7 月 13 日

## 今日進度：
### 資料：複習7/3 - 7/11內容。
### 刷題：完成 HDLBits 的 Karnaugh Map to Circuit 到 DFF with byte enable。

## 遇到的困難與解決方案：
### 問題：
### using one 4-to-1 multiplexer and as many 2-to-1 multiplexers as required
<img width="388" height="361" alt="image" src="https://github.com/user-attachments/assets/511aa44c-348d-41be-bb10-6f97ac0a3164" />

* 如何優化並寫成更精簡程式碼
* 原程式碼：
  ```verilog
	module top_module (
    input c,
    input d,
    output [3:0] mux_in
	); 
    
    assign mux_in[0] = c ? 1'b1 : d ? 1'b1 : 0; //如果 c 是 1 輸出 1；否則如果 d 是 1 輸出 1；如果都不是就輸出 0。
    assign mux_in[1] = 1'b0; //直接接地（GND）
    assign mux_in[3] = (c & d) ? 1'b1 : 1'b0; //當 c 和 d 同時為 1 時輸出 1。
    assign mux_in[2] = (~d) ? 1'b1 : 1'b0; //如果 ~d 成立就輸出 1，否則輸出 0。
    
	endmodule
  ```

### DFF with byte enable
* if - else 造成了不必要的「優先權」與「資料遺失」
<img width="932" height="113" alt="image" src="https://github.com/user-attachments/assets/8b8a3b2d-b80d-4c60-beae-c8e60469a240" />

* 原程式碼：
  ```verilog
  module top_module (
    input clk,
    input resetn,
    input [1:0] byteena,
    input [15:0] d,
    output [15:0] q
	);
    
    always@(posedge clk)begin //DFF 正緣觸發
        if(~resetn)　//低態reset
            q <= 16'h0;
        else if(byteena[1])
            q[15:8] <= d[15:8]; //byteena[1] controls the upper byte
        else if(byteena[0])
            q[7:0] <= d[7:0]; //byteena[0] controls the lower byte 
        else
            q <= d;
    end

	endmodule
  ```
  
* 當 **byteena = 2'b11（兩個位元組都要寫入）時**：因為 if (byteena[1]) 成立了，硬體執行完 q[15:8] <= d[15:8] 之後，就會直接跳過後面的 else if (byteena[0])，結果導致低位元組（q[7:0]）完全沒有更新。
* 當 **byteena = 2'b00（兩個位元組都不寫入，維持原值）時**：硬體會一路走到最後的 else，執行 q <= d;。這意味著即使致能訊號是 0，輸入資料 d 還是被硬生生寫進去了，暫存器失去了「保留舊值」的功能。

### 解法：
### using one 4-to-1 multiplexer and as many 2-to-1 multiplexers as required
* 改寫in[0]、in[2]、in[3]程式碼
* 修改後程式碼
  ```verilog
	module top_module (
    input c,
    input d,
    output [3:0] mux_in
	);    
    
    assign mux_in[0] = c | d;  // OR 閘（c or d 任一為 1 就輸出 1）
    assign mux_in[1] = 1'b0;   // 接地
    assign mux_in[2] = ~d;     // NOT 閘（反相 d 輸出 1）
    assign mux_in[3] = c & d;  // AND 閘（當 c and d 為 1 就輸出 1）
    
	endmodule
  ```

### DFF with byte enable
* 在實體晶片中，高位元組（High Byte, [15:8]）和低位元組（Low Byte, [7:0]）的寫入控制是各自獨立、互不干涉的。
* 在重置之外，我們應該用兩個獨立的 if 條件句來分別控制它們，而當致能訊號為 0 時，什麼都不要寫（隱式保留原值）
* 修改後程式碼：
  ```verilog
    module top_module (
    input clk,
    input resetn,
    input [1:0] byteena,
    input [15:0] d,
    output [15:0] q 
	);
    
    
    always @(posedge clk) begin
        if (~resetn) begin
            q <= 16'h0;       
        end 
		else begin
		
            if (byteena[1]) begin
                q[15:8] <= d[15:8]; 
            end
            
            if (byteena[0]) begin
                q[7:0] <= d[7:0];   
            end
            
            // 如果 byteena[1] 或 byteena[0] 為 0，
            // 沒寫 else 代表硬體會自動維持 q 的上一個狀態（保留原值），這才是正確的暂存器行為！
        end
    end

	endmodule
  ```
* 另寫法：
  ```verilog
  always @(posedge clk) begin
    	if (~resetn) begin
        	q <= 16'h0;
    	end
  		else begin
        	q[15:8] <= byteena[1] ? d[15:8] : q[15:8]; // 1 就寫入新值，0 就維持原本的 q
        	q[7:0]  <= byteena[0] ? d[7:0]  : q[7:0];
    	end
	end
  ```
    

## 關鍵知識/詞彙：
### 再次分析位元運算子（Bitwise）」與「邏輯運算子（Logical）
* 當訊號只有 1-bit 時，0 就是假，1 就是真。這時候位元運算（~, &）跟邏輯運算（!, &&）在數學上的結果完全等價，合成器最後長出來的實體電路也是同一個邏輯閘。  
* 雖然怎麼寫都對，但通常硬體工程師在編寫組合邏輯（處理資料、訊號線）時，會優先使用位元運算子（~, &, |），因為這樣最直覺地對應到硬體邏輯閘。 
* 邏輯運算子（!, &&, ||）通常只會保留給條件判斷（例如 if (rst_n && valid) 這種用來控制狀態機或觸發條件的地方）。

### 高電位非同步reset（8 D flip-flops with active high asynchronous reset）
* 範例 - Dff8ar
  ```verilog
  module top_module (
    input clk,
    input areset,   // 高電位非同步reset
    input [7:0] d,
    output [7:0] q
	);
    //觸發條件： clk 的正邊緣，以及 areset 的正邊緣（因為是高電位有效）
    always@(posedge clk or posedge areset)begin
        if(areset)
            q <= 0;
        else
            q <= d;
    end

	endmodule
  ```
  
### 高電位同步reset
  * 範例 - Dff8r（8 D flip-flops with active high synchronous reset）
    ```verilog
    module top_module (
    input clk,
    input reset,            // 同步 reset
    input [7:0] d,
    output [7:0] q
	);
    
    always@(posedge clk)begin
        if(reset)
            q <= 0;
        else
            q <= d;
    end

	endmodule

    ```

### 使用 begin...end 的 4 大核心好處
1. 確保多個硬體動作「同生共死」
* 晶片設計中，常常要在某個條件成立時，同時改變多個訊號（例如：重置時，要把 q 清零，同時把 valid 訊號也清零）。
* 好處： 用 begin...end 包起來，這兩件事在硬體上才會同時受到同一個條件控制。

2. 徹底絕殺「隱形 Bug」
* 如果只有一行而沒加 begin...end，未來你在維護、修改程式碼時，隨手多補了一行指令，編譯器並不會報錯，但這行新指令會直接脫離控制，產生非常難抓的邏輯 Bug（通常要進模擬器看波形才會發現）。
* 好處： 從一開始就寫好 begin...end，未來要隨時增加、刪除程式碼都非常安全。

3. 程式碼架構層次分明（極速 Debug）
* 當程式碼變得非常龐大，有大量的 if-else 嵌套（Nest）時，良好縮排的 begin...end 會形成一塊一塊的「電路區域」。
* 好處： 大幅縮短 Debug 的時間。

4. 業界標準規範（專業度的體現）
* 在聯發科（MediaTek）或各大 IC 設計廠的 Coding Style Guide（程式碼規範原則） 中，為了防止上述的各種人類肉眼失誤，通常都是強迫一律加上 begin...end。

[回目錄](#toc)

---

<a id="m07d14"></a>

## 2026 年 7 月 14 日

## 今日進度：
### 刷題：完成 HDLBits 的 D latch 到 Implement a JK flip-flop with only a D-type flip-flop and gates（Exams/ece241 2013 q7）。

## 遇到的困難與解決方案：
### 問題：
### Exams/ece241 2014 q4
* z 的輸出邏輯錯誤 (Timing Bug)： z 是一個純組合邏輯，它是直接接在暫存器輸出 Q 後面的 NOR 閘。
* 將 z 一併寫在循序邏輯電路中，造成 output z 資料獲取比實際慢一個 D 正反器的時脈週期
<img width="463" height="345" alt="image" src="https://github.com/user-attachments/assets/41b0f37d-3c79-4e73-bdde-d185887ceab1" />

* 原程式碼：
  ```verilog
	module top_module (
    input clk,
    input x,
    output z
	);
    
    reg [2:0]q;
    
    always@(posedge clk)begin
        q[0] <= x ^ q[0];
        q[1] <= x & (~q[1]);
        q[2] <= x | (~q[2]);
        z <= ~(q[0] | q[1] | q[2]); //將 z 一併寫在循序邏輯電路中
    end

	endmodule
  ```
  * 硬體長相：因為把 z <= ... 寫在 always @(posedge clk) 裡面，編譯器會認定：「z 也是一個必須在時脈正邊緣更新的暫存器！」
  * 實際電路：q[0], q[1], q[2] 的訊號先拉到一個 NOR 閘。NOR 閘的輸出，會再接一個實體的 D 暫存器，最後這個暫存器的輸出端才是 z。
    * 所以訊號從 q 到 z 之間，多過了一次「時脈關卡」。

### 解法：
### Exams/ece241 2014 q4
* 將 z 移到 always 區塊外面，用 assign 賦值
* 修改後程式碼
  ```verilog
	module top_module (
    input clk,
    input x,
    output z
	);
    
    reg [2:0]q;
    
    always@(posedge clk)begin
        q[0] <= x ^ q[0];
        q[1] <= x & (~q[1]);
        q[2] <= x | (~q[2]);
    end
    assign z = ~(q[0] | q[1] | q[2]);

	endmodule
  ```
  * 硬體長相：因為 assign 是組合邏輯。
  * 實際電路：q[0], q[1], q[2] 的輸出線拉出來，直接接進一個實體的 NOR 閘，NOR 閘的輸出端直接就是 z 了。
    * 所以沒有任何額外的暫存器。只要 q 發生改變，訊號穿過 NOR 閘（僅有極微小的物理延遲），z 就會**立刻**跟著改變。

## 關鍵知識/詞彙：
### 再次分析時序、組合邏輯
### 時序邏輯（需要存狀態、記憶上一次的值）
* 用 always @(posedge clk) 搭配 reg 與 <=（non-blocking）。

### 組合邏輯（純運算、不需記憶，只想即時得到結果）
* 用 assign 搭配 wire 與 = （blocking）。

[回目錄](#toc)

---

<a id="m07d15"></a>

## 2026 年 7 月 15 日

## 今日進度：
### 資料：複習7/3 - 7/14內容。
### 刷題：複習 HDLBits 的 "Modules" 到 "Implement a JK flip-flop with only a D-type flip-flop and gates（Exams/ece241 2013 q7）"；完成 HDLBits - sequential logic。

## 遇到的困難與解決方案：
### 問題：
### Edgedetect（正邊緣偵測）
* 不理解邊緣偵測的核心硬體思想，最初思想為當clk正緣發生且有資料(in)輸入(資料為真)則邊緣偵測(pedge)為真。

### Edgecapture（邊緣捕獲暫存器）
<img width="647" height="232" alt="image" src="https://github.com/user-attachments/assets/87135924-2e42-482c-9537-fdf29bedc062" />

1. 問題一
	* 當 reset 訊號為高電位時，程式只會執行 if 裡面的 out <= 0。此時 else 裡面的 in_previous <= in 完全不會被執行！
	* 導致在 reset 期間，in_previous 保持在舊的值。一旦 reset 變回 0 的下一個瞬間，因為 in_previous 沒有跟著被重置或同步更新，會瞬間觸發一個錯誤的負邊緣訊號，導致輸出產生非預期的脈衝。
* 程式
```verilog
  	module top_module (
    input clk,
    input reset,
    input [31:0] in,
    output [31:0] out
	);
    
    reg [31:0]in_previous;
    
    always@(posedge clk)begin
        if(reset)begin
            out <= 0;
        end
        else begin
            out <= (~in) & in_previous;
            in_previous <= in;
        end
    end

	endmodule
```

2. 問題二
   * 第一次修正後，偵測後立刻歸零，但題目要求的是「捕獲並保持（鎖定）」，所以再次編譯錯誤
* 程式碼
  ```verilog
  module top_module (
    input clk,
    input reset,
    input [31:0] in,
    output [31:0] out 
	);
    
    reg [31:0] in_previous;
    
    always @(posedge clk) begin
        
        in_previous <= in; 
        
        if (reset) begin
            out <= 32'b0; 
        end
  		else begin
            out <= (~in) & in_previous; //只有在發生負邊緣的那一個週期 out 會是 1，下一個週期如果 in 維持 0（沒有新的邊緣），out 就會立刻自動變回 0。
        end
    end

	endmodule
  ```

### 解法：
### Edgedetect（正邊緣偵測）
* 題目需求：檢測當輸入信號從一個時鐘週期內的 0 變為下一個時鐘週期內的 1 。 應該在 0 變為 1 的時鐘週期之後，設置該位。
* 程式碼
  ```verilog
  module top_module (
    input clk,
    input [7:0] in,
    output [7:0] pedge
	);
    
    reg [7:0]in_previous; // 用來儲存「上一個週期」輸入值的暫存器
    
    always@(posedge clk)begin
        pedge <= in & (~in_previous); //今天的 pedge 等於：今天為 1 且 昨天為 0
        in_previous <= in; //將今天的輸入值存進去，變成昨天的狀態，更新狀態
    end

	endmodule
  ```

### 邊緣偵測的核心硬體思想 - 準備一個「昨天」的暫存器
* 硬體上偵測「變化」需拿「（現在）的數值」跟「（前一個週期）的數值」做對比
* 如題意：正邊緣偵測要求的是 - 只有在 in 從 0 變 1 的那一下 pedge 輸出 1，之後即使 in 繼續維持 1，pedge（輸出）也必須立刻降回 0
* 其他邊緣偵測：
  * 負邊緣偵測：只有在輸入 0 變 1 的那一下邊緣偵測輸出 1，之後即使輸入繼續維持 1，輸出也必須立刻降回 0
  * 雙邊緣偵測：在輸入 0 變 1 、 1 變 0 的那一下邊緣偵測輸出 1，之後即使輸入繼續維持 1，輸出也必須立刻降回 0

### Edgecapture（邊緣捕獲暫存器）
1. 修正一
   * 不管有沒有 reset，in_previous 每個週期都應該要把當前的 in 存下來，或者在 reset 時也將它清零/初始化。
* 程式碼
  ```verilog
  module top_module (
    input clk,
    input reset,
    input [31:0] in,
    output [31:0] out 
	);
    
    reg [31:0] in_previous;
    
    always @(posedge clk) begin
        in_previous <= in; //每個時脈週期都把當前的 in 存下來，避免 reset 撤銷時產生假的邊緣
        if (reset) begin
            out <= 32'b0;
        end
  		else begin
            out <= (~in) & in_previous; // 負邊緣偵測
        end
    end

	endmodule
  ```
2. 修正二
   * 利用 OR 來鎖定狀態，修正 out <= (~in) & in_previous; 這行
     ```verilog
     out <= out | ((~in) & in_previous);
     ```
   * 「現在的 out 等於原本的 out 狀態。」只要 out 的某個 bit 曾經變成了 1，因為 1 | 任何值 = 1，它就會鎖定在 1，不會自己掉回 0。
* 修正後程式碼
  ```verilog
  module top_module (
    input clk,
    input reset,
    input [31:0] in,
    output [31:0] out 
	);
    
    // 用來記錄「上一個週期」輸入值的 32-bit 暫存器
    reg [31:0] d_last;

    always @(posedge clk) begin
        // 每個時脈正邊緣，更新「昨天的值」
        d_last <= in;
        
        // 同步重置與捕獲邏輯
        if (reset) begin
            out <= 32'b0; // reset 優先，全部清零
        end
  		else begin
            // 若有下降沿就置 1，否則維持原狀（利用按位或 OR）
            out <= out | (~in & d_last);
        end
    end

	endmodule
  ```

## 關鍵知識/詞彙：
### 時序怎麼運作（以非阻塞賦值來看）
1. 當 posedge clk 來臨的一瞬間，pedge 會使用這一刻之前的 in 與 in_last 的舊值來做運算
2. 計算完 pedge 的同時，in_last 才會被更新為目前的 in
3. 這樣就在同一個時脈邊緣完成了「比較」與「存檔」兩個動作

### 範例 - Edgedetect（正邊緣偵測）時，in[0]的前一訊號為何？
<img width="607" height="153" alt="image" src="https://github.com/user-attachments/assets/28c5e5b1-9c17-43e9-a91a-50656969ae26" />

* 程式
  ```verilog
  module top_module (
    input clk,
    input [7:0] in,
    output [7:0] pedge
	);
    
    reg [7:0]in_previous; // 用來儲存「上一個週期」輸入值的暫存器
    
    always@(posedge clk)begin
        pedge <= in & (~in_previous); //今天的 pedge 等於：今天為 1 且 昨天為 0
        in_previous <= in; //將今天的輸入值存進去，變成昨天的狀態，更新狀態
    end

	endmodule
  ```
* 在剛上電或剛開始執行時，如果我們沒有做任何處理，in_previous 的值在硬體上是「隨機、未知的（Undetermined / X）」。
  
1. 如果完全不重置（不給初始值），會發生什麼事？
    * 在實際的 FPGA 或晶片剛接通電源（上電）的那一瞬間，所有的 D 暫存器（包括 in_previous）裡面的電晶體會隨機倒向某一邊。
    * 在硬體模擬（Simulation）中，in_previous 的初始值會是 X (Unknown，未知值)。
    * 此時如果 in[0] 輸入是 0，而 in_previous[0] 是 X，會導致你的輸出 out 也是 X。直到時脈經過了第一個上升沿，把 in 的值存進in_previous 之後，電路才會開始正常工作。
  
2. 在 Verilog 中，我們如何解決「第一個狀態未知」的問題？
    * 利用 reset 訊號進行「強制初始化」（最標準的做法）
    * 在宣告時直接給予預設值（FPGA 常用）
       ```verilog
       reg [7:0] in_previous = 7'b0; // 上電時自動載入為 0
       ```

### 邊緣捕獲的關鍵要求
* 一旦某個 bit 偵測到下降沿（從 1 變 0），該 bit 的輸出 out 就必須一直鎖定在 1。就算後面沒有新的下降沿、就算 in 訊號一直變來變去，out 也必須牢牢記住「曾經發生過下降沿」這件事，直到按下 reset 為止。

### 雙邊沿觸發器（Dual-edge）
1. 它是以「半個時脈週期（Half-Cycle）」為單位的延遲
   * 只要 clk 轉折一下（半個週期），資料就會被傳遞過去。
   * 所以它造成的延遲，在時間軸上被縮短成了半個時脈週期。這讓資料能以兩倍的速度（Double Data Rate, 如我們熟知的 DDR 記憶體）向前推進！
     
2. 「延遲」在硬體中其實是保護機制
   * 讓前面的組合邏輯有充足的時間去運算，最後穩定下來。
   * 等到 clk 邊緣（上升沿或下降沿）來臨，暫存器才會抓取當下最穩定的正確資料，並延遲到下一刻。

3. 今日範例
<img width="300" height="102" alt="image" src="https://github.com/user-attachments/assets/6bb186e6-b66c-4a64-97f6-f08b99a87d10" />

   ```verilog
   module top_module (
    input clk,
    input d,
    output q
	);
    reg q_pos;
    reg q_neg;

    // 上升沿時，把 (d ^ q_neg) 存進 q_pos
    always @(posedge clk) begin
        q_pos <= d ^ q_neg;
    end

    // 下降沿時，把 (d ^ q_pos) 存進 q_neg
    always @(negedge clk) begin
        q_neg <= d ^ q_pos;
    end

    // 最終輸出 q 永遠是兩個暫存器 XOR 的結果
    assign q = q_pos ^ q_neg;

	endmodule
   ```
   
   * 程式運作原理：
     * 當「上升沿」來臨時：q_pos 變成了 d ^ q_neg。此時輸出的 q = q_pos ^ q_neg 就變成了 (d ^ q_neg) ^ q_neg。根據 XOR 特性，兩個 q_neg 互相抵銷了！所以 q 瞬間變成了 d！
     * 當「下降沿」來臨時：q_neg 變成了 d ^ q_pos。此時輸出的 q = q_pos ^ q_neg 就變成了 q_pos ^ (d ^ q_pos)。同理，兩個 q_pos 互相抵銷了！所以 q 也瞬間變成了 d！

5. 應用
   * DDR 記憶體 (Double Data Rate SDRAM) ── 最著名的應用
     * 應用方式： 記憶體晶片與 CPU 之間的資料匯流排（Data Bus），就是利用雙邊沿觸發技術。
     * 效果： 如果記憶體時脈是 1600 MHz，傳統單邊沿（SDR）只能達到 1600 Mbps 的傳輸率；而改用雙邊沿觸發後，在同一個時脈下，傳輸率直接翻倍變成 3200 Mbps！這也是為什麼我們買記憶體時，標示的頻率通常是實際時脈的兩倍。

   * 行動裝置與綠色晶片 ── 節省 50% 的時脈功耗
     * 省電絕招：如果我們把晶片內部的 DFF 全部換成「雙邊沿觸發（DETFF）」，就可以將時脈頻率直接砍半（例如從 200 MHz 降到 100 MHz），但晶片的運算效能完全保持不變！
     * 效果： 時脈頻率減半，直接讓時脈樹的功耗省下將近一半，手機續航力大幅提升。

   * 高速序列傳輸介面 (SerDes / High-Speed Serial)
     * 應用方式： 為了降低晶片內部時脈產生器（PLL/DLL）的設計難度，工程師會讓發送端與接收端改用雙邊沿來抽樣資料。
     * 效果： 我們只需要產生 10 GHz 的時脈，就能傳輸 20 Gbps 的資料流，大大降低了高頻類比電路的設計門檻。

6. 問題 - 為什麼不把晶片裡的暫存器全部改成雙邊沿？
   * 對時脈「工作週期（Duty Cycle）」要求極苛刻：
     * 單邊沿觸發只看上升沿，所以時脈訊號是「High 佔 60%、Low 佔 40%」還是五五開，完全不影響系統運作。
     * 但雙邊沿觸發同時看兩邊。如果時脈工作週期不是完美的 50%，那麼「奇數週期」和「偶數週期」的時間長度就會不一樣，這會導致電路的時序分析（Static Timing Analysis）變得極其痛苦，非常容易出錯。

   * 硬體成本與設計難度：
     * 標準的 FPGA 或標準元件庫（Standard Cell Library）裡，雙邊沿暫存器的電路結構比單邊沿複雜得多（面積大、放線難），因此只會用在記憶體、傳輸介面等「最需要衝極速、省功耗的刀口上」。

[回目錄](#toc)

---

<a id="m07d16"></a>

## 2026 年 7 月 16 日

## 今日進度：
### 影片：[TT 小教室 Verilog RTL design 進階教學【Coding Style】- 【Synchronizer】](https://www.youtube.com/watch?v=U1ZQzLmoARM&list=PLuhWBQnV46Q92gAT-KvzdJUhBh3maNkFF)
### 刷題：完成 HDLBits - counters 的 Four-bit binary counter  到 slow decade counter。

## 遇到的困難與解決方案：
### 問題：
### slow decade counter
* 將同步致能訊號與同步、非同步 reset 觀念搞混

### 解法：
1. 非同步重置(Asynchronous Reset)
   * 運作機制： 只要重置按鈕一按下去，電路立刻歸零，完全不管時脈有沒有在跑
   * 優點：
     * 不需要時脈（Clock-less）： 晶片剛上電時，時脈產生器（PLL）可能還沒穩定（甚至根本還沒開始送時脈）。此時，非同步重置可以在沒有時脈訊號的情況下，直接把整顆晶片初始化到安全狀態
     * 節省面積： 大部分晶片底層的標準元件（Standard Cell）或 FPGA 的 D 暫存器，硬體內部本來就內建了一根「非同步重置」的實體接腳（Clear Pin）。直接使用它不需要額外的邏輯閘
   * 缺點：
     * 非同步釋放帶來的危機： 當你要放開重置（Reset Release）時，如果放開的瞬間剛好卡在時脈的上升沿，暫存器會陷入 「亞穩態（Metastability）」。這會導致晶片當機或輸出亂碼
       
2. 同步重置 (Synchronous Reset)
   * 運作機制： 重置訊號按下去後什麼事都不會立刻發生，必須等到 下一個時脈正緣 來臨，電路才會重置
   * 優點：
     * 百毒不侵： 因為它由 clk 統一過濾，所以重置訊號上的毛刺（Glitches，小雜訊）會被時脈自動濾除
     * 100% 同步： 整個晶片的所有暫存器都在同一個時脈緣一起重置、一起釋放，絕對不會有亞穩態問題，時序分析（STA）非常簡單
   * 缺點：
     * 必須有時脈： 如果時脈因為意外停掉（Clock Gate 關閉或 PLL 沒準備好），這個重置就完全失效了。
     * 浪費電路面積： 如果硬體暫存器本身沒有同步重置腳位，編譯器必須在 D 暫存器的輸入端前多塞一個 AND 閘來實現同步重置，這會增加晶片面積和延遲

## 關鍵知識/詞彙：
### 一、Coding Style
1. 訊號取名
   * 取名規則：
     * 名字要有意義，讓大家都看得懂訊號代表的意思。
     * input: i_xxx
	 * output: o_xxx
     * wire: w_xxx
     * reg: r_xxx
     * state machine: *_ cs, *_ curr_state, *_ ns, *_ next_state
     * 訊號、10、module名稱用小寫；常數、parameter、define用大寫。
     * 傳輸訊號名稱加上prefix(前綴)，o_aa2bb _* 代表從block“aa”到block“bb”的訊號
     * *_ n或 *_ b代表active low訊號
     * 一個檔案一個module，檔名就是module name
     * instant name建議是u_module_name
   * 避免使用
     * n+數字、n123等
     * vdd、gnd、vss保留給power、ground使用

2. always block
   * Combionational Logic
     ```verilog
     always @ (*) begin
		// logic uses blocking "="
	 end
     ```
   * Sequential logic
     ```verilog
     always @ (posedge i_clk or negedge i_rst_n) begin
	 	if (!i_rst_n) begin
	 	//reset the DFF
	 	end
     	else begin
	 	// DFF logic uses non-blocking " <= "
	 	end
	 end
     ```
   * RTL裡不要用任何#delay
   * Combinational就是這個cycle出值；Sequential就是下一個cycle出值
   * 避免combinational loop（把自己產生的組合邏輯又餵回給自己用來產生那個邏輯）

3. DFF（D Flip-flop）
   ```verilog
   always @ (posedge i_clk or negedge i_rst_n) begin
   		if (!i_rst_n)
   			//reset the DFF
   		else if
   		// DFF logic uses non-blocking " <= "
   end
   ```
   * 注意DFF的clock和reset是誰
   * DFF要有reset，條件要寫滿，以免變成Latch
   * clock和非同步reset在scan時一定要可控(controllable)，如果不行要加scanmux
   * 盡量整個design都用一樣的clock edge
   * 盡量避免 clock 連到 DFF 的 data pin
   * 注意發送端和接收端的 clock 是否一樣，不一樣要處理 CDC（clock domain crossing）的問題
   * 最後一個else最好不要賦新值（assign 回自己或完全不寫），這樣可以讓合成工具自動插入clock gating
   * DFF array太寬和太深時（例如超過1000個DFFs）建議改用memory，面積比較划算，繞線比較沒問題。e.g.reg[255:0]r_array[1024];
     
4. State Machine
   ```verilog
   parameter IDLE = 1'b0;
   parameter RUN = 1'b1;

   always @ (posedge i_clk or negedge i_rst_n) begin
   		if (!i_rst_n)
   			r_xxx_cs <= IDLE;
   		else
   			r_xxx_cs <= r_xxx_ns;
   end

   always @(*) begin
   		case (r_xxx_cs)
   		IDLE:
   			if (i_start) r_xxx_ns = RUN;
   			else r_xxx_ns = IDLE;
   		RUN:
   			if (i_stop) r_xxx_ns = IDLE;
   			else r_xxx_ns = RUN;
   			default: r_xxx_ns = IDLE;
   		endcase
   end
   ```
   * States 用 parameter 定義
   * current state要有 reset 條件
   * current state 在 non-blocking 的 always block 裡 assign 成 next state
   * next state 在 blocking 的 always block 裡用 case 靠 current state 來決定
   * 每一個 state 都要寫到，先寫跳出當下 state 的條件，最後一個 else 就是停留在當下的 state
   * next state 記得加上 default 條件，回到 IDLE 狀態

5. Block 之間
   * input signals通常可以直接用，但邏輯不要太深，除非 timing 真的很差，再 Flop 後使用
   * output signals 建議 Flop 後再給其他blocks
   * 不要把邏輯寫在 pin 的連接上 e.g.i_a(w_b&w_c);
   * 整個 design 都用到的常數用 define 定義，部分design的參數用 parameter 傳遞
   * 善用前輩設計好的design，例如FIFO、synchronizer。
   * 善用comment，尤其在input/output上，讓別人也看得懂意思。

### 二、Synchronizer
1. 簡介、用途
  * 同步器，Synchronizer是SoC裡常見的元件
  * 處理不同clock之間的訊號接收
  * 同步數位電路都是由clock驅動，電路在同一個時鐘邊沿(clock edge)工作
  * SoC裡可以有許多不同步的時鐘，有得快，有得慢
  * 訊號需要從某一個時鐘域(Clock domain)傳遞到另一個時鐘域，術語稱為 CDC(Clock Domain Crossing)，就需要同步器。

2. Setup Time & Hold Time
<img width="912" height="400" alt="image" src="https://github.com/user-attachments/assets/c93d6b8b-74d1-4ae3-84a4-b7cb89a23bd4" />
 
3. Metastability（亞穩態）
<img width="699" height="239" alt="image" src="https://github.com/user-attachments/assets/bc8d7b65-5a4a-4a4f-85c1-f6b5bd0f2cbc" />
<img width="502" height="330" alt="image" src="https://github.com/user-attachments/assets/fd4bec73-800b-4167-a471-5bc3d61a4073" />

   * 當一個DFF的 setup time 或 Hold time 不滿足時，它的Q將"不可預測"，稱為 Metastability 亞穩態。
   * 沒有辦法可以"完全"解決，只能大幅度降低產生的機率。
   * MTBF(mean time between failure)意思是發生兩次錯誤之間的間隔，這個指標常用來衡量CDC的情形，越大越好（代表隔了很長一段時間才發生下一次錯誤）。   

[回目錄](#toc)

---

<a id="m07d17"></a>

## 2026 年 7 月 17 日

## 今日進度：
### 影片：[TT 小教室 Verilog RTL design 進階教學【Memory】](https://www.youtube.com/watch?v=U1ZQzLmoARM&list=PLuhWBQnV46Q92gAT-KvzdJUhBh3maNkFF)
### 刷題：完成 HDLBits 的 "counter 1-12" 到 "4-digit BCD counter (Countbcd)"；待完成 "12-hour clock"。

## 遇到的困難與解決方案：
### 問題：
### 4-digit BCD counter (Countbcd)
* q[15:0]個別拆成4個bit（q[3:0]、q[7:4]...、q[15:12]）計算的用意為何
<img width="938" height="230" alt="image" src="https://github.com/user-attachments/assets/bacd286d-dcd8-42c1-a779-9a115c71b3da" />

* 原程式碼
  ```verilog
  module top_module (
    input clk,
    input reset,   
    output [3:1] ena,
    output [15:0] q);
    
    
    assign ena[1] = q[3:0] == 4'd9; //當個位數字counter數到9，十位數字counter致能
    assign ena[2] = (q[3:0] == 4'd9 && q[7:4] == 4'd9);//當個位、十位數字counter數到9，千位數字counter致能
    assign ena[3] = (q[3:0] == 4'd9 && q[7:4] == 4'd9 && q[11:8] == 4'd9 );//當個位、十位、百位數字counter數到9，千位數字counter致能
    
    //構建個、十、百、千位數字counter
    counter10 inst0(
        .clk(clk),
        .reset(reset),
        .enable(1), //個位數字永遠致能
        .q(q[3:0])
    );
    
    counter10 inst1(
        .clk(clk),
        .reset(reset),
        .enable(ena[1]),
        .q(q[7:4])
    );
    
    counter10 inst2(
        .clk(clk),
        .reset(reset),
        .enable(ena[2]),
        .q(q[11:8])
    );
    
    counter10 inst3(
        .clk(clk),
        .reset(reset),
        .enable(ena[3]),
        .q(q[15:12])
    );
    

	endmodule

	module counter10( //構建0 到 9 的計數（BCD 計數器）
    	input clk,
    	input reset,
    	input enable,
    	output reg [3:0] q);
    
    	always@(posedge clk)begin
        	if(reset)begin
            	q <= 4'd0;
        	end
        	else if(enable)begin  
            	q <= (q < 4'd9) ? q + 4'b0001 : 0;
        	end
    	end

	endmodule
  ```
### 解法：
### 4-digit BCD counter (Countbcd)
* 這題考的是 BCD（Binary-Coded Decimal，二進位碼十進位）。簡單來說，這是一種「**用二進位的外殼，強行裝載十進位靈魂**」的設計方式。
* 如果你**不拆開**，直接把 q 當成一個普通的 16-bit 二進位計數器，對人類習慣的十進位顯示器（例如七段顯示器）來說**必須額外寫一個極其複雜的「二進位轉十進位（Binary to BCD）」數學電路**，會大幅消耗晶片的面積與效能。
* 拆開計算有三大優勢：
  * 4位元剛好裝得下數字 9
  * 直覺對應人類的顯示介面（晶片外面負責接「七段顯示器」的電路，完全不需要做任何數學運算，直接顯示對應數字）
  * 硬體設計的「模組化與級聯」（只需要設計一個 counter10 子模組（只管 0~9），然後複製 4 次（個、十、百...），再用組合邏輯（ena）把他們串起來）- 分治法（Divide and Conquer）

## 關鍵知識/詞彙：
### Exams/ece241 2014 q7a - Design a 1-12 counter
<img width="943" height="481" alt="image" src="https://github.com/user-attachments/assets/378391f6-addb-4e2c-971a-c945ba41638a" />

* 程式碼：
  ```verilog
  module top_module (
    input clk,
    input reset,
    input enable,
    output [3:0] Q,
    output c_enable,
    output c_load,
    output [3:0] c_d
	); //

	//實例化題目提供的 4-bit 內建計數器
    count4 my_counter(
        .clk(clk),
        .enable(c_enable),
        .load(c_load),
        .d(c_d),
        .Q(Q)
    );
    assign c_enable = enable; //產生要送往子模組 count4 的控制訊號
    assign c_load = reset | ((Q == 4'd12) && enable); // 當 reset 為 1，或者（目前是 12 且 enable 為 1 要往上加時），就要觸發 load
    assign c_d = 4'd1; //c_load為 1 時動作，不論是 reset 還是從 12 回彈，目標值都是 1

	endmodule
  ```

### Exams/ece241 2014 q7b - create a digital wall clock
<img width="943" height="296" alt="image" src="https://github.com/user-attachments/assets/0944c545-e2cf-414b-90e9-0960f35a4a58" />

* 程式碼：
  ```verilog
  module top_module (
    input clk,
    input reset,
    output OneHertz,
    output [2:0] c_enable
	); // 
    
    wire [3:0]q0, q1, q2;
    
    assign c_enable[0] = 1'd1; //個位數計數永遠致能
    assign c_enable[1] = (q0 == 4'd9); //個位數數到9，十位計數致能
    assign c_enable[2] = (q0 == 4'd9 && q1 == 4'd9);////個位數數到9，十位數數到9，百位計數致能

  //構建 3 台counter
    bcdcount inst0(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[0]),
        .Q(q0)
    );
    
    bcdcount inst1(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[1]),
        .Q(q1)
    );
    
    bcdcount inst2(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[2]),
        .Q(q2)
    );

    assign OneHertz = (q0 == 4'd9 && q1 == 4'd9 && q2 == 4'd9 ); //當數字為999時輸出1，每隔1000 cycle出現999一次，觸發一次（1Hz）之後就歸0正好1000Hz/1000=1Hz
    
	endmodule
  ```

### Memory
1. 簡介
   * SoC裡必要的元件
   * 用來"記憶"：資料、計算過程、狀態等
   * 所占的面積甚至可以超越組合邏輯的面積
   * 設計數位電路時需要考慮：
     * 儲存的架構：用哪一種型態的儲存器？分享還是專用？
     * 如何讀寫資料：1讀1寫、2讀、2寫、只讀不寫
     * bandwidth是否滿足throughput：每個 cycle 能獲得多少資料？
     * Latency（延遲）: 1 cycle, 2 cycles, ...
     * 接口的規範：AXI；push／pop；rd_en／wr_en

2. Memory 型態

| 型態 | 每個cycle讀/寫 | Reset | Latency | 速度 | 面積 | 功耗 |
| --- | --- | --- | --- | --- | --- | --- |
| DFF Array | N讀N寫 | 1 cycle | 0 | 最快 | 最大 | 最大 |
| FIFO | 1讀1寫 | 1 | 0/1 | 次快 | 大 | 大 |
| 1 port SRAM | 1讀 or 1寫 | N | 1 | 快 | 小 | 小 | 
| 2 port SRAM | 1讀1寫 | N | 1 | 可 | 中 | 中 |
| Dual port SRAM | 1讀1寫 or 2讀 or 2寫 | N/2 | 1 | 慢 | 大 | 大 |
| ROM | 1讀 | 不能 | 1 | 慢 | 小 | 小 |
* N：儲存空間的深度

3. DFF Array
   * 宣告一個2-Dimensional reg就是一個DFF array
     * reg [WIDTH-1:0] dff_array[DEPTH];
     * WIDTH是這個array的寬度：用位寬選
     * DEPTH是這個array的深度：用地址選
   * 每個clock cycle都可以讀寫任一個地址的任意位寬
   * rd _* /wr _* 可以擴充組數增加bandwidth
   * 寫：
     ```verilog
     generate
	 for (geni=0; geni<`DEPTH; geni=geni+1) begin
     always @(posedge i_clk or negedge i_hrst_n) begin
	 	if (~i_hrst_n)
	 		dff_array[geni] <= 1'b0;
	 	else if (wr_en && (wr_addr == geni))
	 		dff_array[geni] <= wr_data;
     		end
     	end
     endgenerate
     ```
     * 讀：
       ```verilog
       assign rd_data = dff_array[rd_addr];
       ```
     * 在設計時深度不要太大（想像讀取時是一個巨大的MUX去選出要讀取的data），通常建議 [WIDTH]*[DEPTH] 不要上萬
   
4. FIFO（First in First out）
   * 有一個入口和一個出口，一進一出，先進先出的儲存元件
   * 讀是pop；寫是push；與clock同步
   * 有read/write兩個同步的指標(rd_ptr/wr_ptr)，ptr是指pointer
   * push：(wr_ptr + 1) % (FIFO_DEPTH) //寫入之後再把 wr_ptr + 1
   * pop: (rd_ptr + 1) % (FIFO_DEPTH) //讀取之後再把 rd_ptr + 1
   * rd_ptr == wr_ptr：FIFO是空的(empty) //**資料無法pop**，會造成"underflow"
   * rd_ptr == (wr_ptr+1)%(FIFO_DEPTH)：FIFO 是滿的(full) //**資料無法再push**，會造成"overflow"
   * diff是FIFO裡資料的個數。選擇性的output
   * FIFO內部可以使用DFF array實現，也可以使用2port SRAM實現。
   * I/O宣告：
     ```verilog
     module fifo
	 #(
     parameter FIFO_WIDTH = 16,
	 parameter FIFO_DEPTH = 4,
	 parameter FIFO_DEPTH_BW = 2
     )
     
	 (
	 input i_clk,
	 input i_hrst_n,
	 output o_empty,
	 output o_full,
	 output [FIFO_DEPTH_BW:0] o_diff,
	 input i_push,
	 input [FIFO_WIDTH-1:0] i_push_data,
	 input i_pop,
	 output [FIFO_WIDTH-1:0] o_pop_data
     );
     ```

5. SRAM
   * static random-access memory 靜態隨機存取記憶體
   * 用在需要"大量儲存資料"或是"計算過程與結果"的地方
   * 只要保持通電，儲存的資料就可以恆常保持，斷電後，SRAM儲存的資料就消失
   * 廠商提供Memory Compiler，生成不同種類的SRAM給不同的應用
   * 通常單片SRAM都有長寬比例與最大值的限制
    
6. 應用方式
   *  DFF array：
     * 隨時存取大量的資料、超高頻寬、超小Latency
     * 儲存的資料量不大，例如小於1萬bits
       
   * FIFO
     * 資料排隊依序傳送
     * 可以適當增加bandwidth，一次push或pop多筆資料
     * 非同步FIFO可以處理CDC問題

   * 1 port SRAM
     * 同一週期只需1讀或1寫的操作
     * 節省面積
       
   * 2 port SRAM
     * 同一週期需要1讀且1寫的操作
     * 加大位寬以增加頻寬
     * 處理CDC問題
     * 節省面積
     * Timing 較差
       
   * Dual port SRAM
     * 同一週期需要2讀或2寫的操作
     * 先進製程(<40nm)盡可能避免使用此類型
     * 面積大

   * ROM
     * 事先決定內容，不可改
     * 斷電後內容不消失
     * CPU Boot ROM：開機CPU就去讀（例如：初始化）

### 待完成
```verilog
module top_module(
    input clk,
    input reset,
    input ena,
    output pm,
    output [7:0] hh,
    output [7:0] mm,
    output [7:0] ss); 
    
    wire [5:0] c_enable;
    assign c_enable[0] = 1'b1;
    assign c_enable[1] = (s0[3:0] == 9);
    assign c_enable[2] = (s0[3:0] == 9 && s1[7:4] == 5);
    assign c_enable[3] = (s0[3:0] == 9 && s1[7:4] == 5 && m0[3:0] == 9);
    assign c_enable[4] = (s0[3:0] == 9 && s1[7:4] == 5 && m0[3:0] == 9 && m1[7:4] == 5);
    assign c_enable[5] = (s0[3:0] == 9 && s1[7:4] == 5 && m0[3:0] == 9 && m1[7:4] == 5 && h0[3:0] == 9);
    assign pm = (s0[3:0] == 9 && s1[7:4] == 5 && m0[3:0] == 9 && m1[7:4] == 5 && h0[3:0] == 1 && h1[7:4] == 1);
    
    counter9 s0(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[0]),
        .ss(ss[3:0])
    );
    
    counter5 s1(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[1]),
        .ss(ss[7:4])
    );
    
    counter9 m0(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[2]),
        .mm(mm[3:0])
    );
    
    counter5 m1(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[3]),
        .mm(mm[7:4])
    );
    
    counter9 h0(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[4]),
        .hh(hh[3:0])
    );
    
    counter2 h1(
        .clk(clk),
        .reset(reset),
        .enable(c_enable[5]),
        .hh(hh[7:4])
    );

endmodule

module counter9(
    input clk,
    input reset,
    input enable,
    output reg [3:0] q);
    
    always@(posedge clk)begin
        if(reset)begin
            q <= 4'd0;
        end
        else if(enable)begin  
            q <= (q < 4'd9) ? q + 4'b0001 : 0;
        end
    end
    
endmodule

module counter5(
    input clk,
    input reset,
    input enable,
    output reg [3:0] q);
    
    always@(posedge clk)begin
        if(reset)begin
            q <= 4'd0;
        end
        else if(enable)begin  
            q <= (q < 4'd5) ? q + 4'b0001 : 0;
        end
    end
    
endmodule

module counter2(
    input clk,
    input reset,
    input enable,
    output reg [3:0] q);
    
    always@(posedge clk)begin
        if(reset)begin
            q <= 4'd0;
        end
        else if(enable)begin  
            q <= (q < 4'd2) ? q + 4'b0001 : 0;
        end
    end
    
endmodule
```

[回目錄](#toc)

---

<a id="m07d21"></a>

## 2026 年 7 月 21 日

## 今日進度：
### 資料：複習7/3 - 7/17內容。
### 刷題：複習 HDLBits 7/3 - 7/17 進度。

[回目錄](#toc)

---

<a id="m07d23"></a>

## 2026 年 7 月 23 日

## 今日進度：
### 資料：利用網路資源學習Vivado - How to use vivado for Beginners by Anand Raj
### Vivado：嘗試在 Vivado 上寫簡單半加器模型並模擬測試

## 今日成果探討：
### half-adder
* Design sources
```verilog
module half_adder(

input a,b,
output carry,
output sum

    );
    
    assign sum = a ^ b;
    assign carry = a & b;
    
endmodule
```

* Simulation sources
```verilog
module half_adder_tb();

reg t_a, t_b; //輸入用reg
wire Sum, Carry; //輸出用wire

// 實例化
half_adder inst0( 
    .a(t_a),
    .b(t_b),
    .sum(Sum),
    .carry(Carry)
);
```

* 模擬結果
<img width="780" height="415" alt="image" src="https://github.com/user-attachments/assets/b1f33562-5125-4ad4-8991-89a545118c93" />

## 關鍵知識/詞彙：
### Testbench（測試平台）
1. 提供驅動訊號（時脈與輸入資料）
* 硬體電路是不會自己運作的。Testbench 可以模擬真實世界中的外部輸入例如：
	* 自動生成規律震盪的 Clock（時脈）
    * 觸發系統開機的 Reset（重置訊號）
    * 按時間順序餵入各種測試資料（如 10ns 時輸入數字 5，20ns 時輸入數字 10）

2. 驗證邏輯功能（不用每次都燒錄進晶片）
* 將代碼燒錄進 FPGA 晶片通常需要花費 幾十分鐘到數個小時
    * 沒有 Testbench： 每改一行代碼，就要花一小時燒錄，再用示波器抓訊號，效率極低
    * 使用 Testbench： 在電腦上跑模擬只需要幾秒鐘，就能透過波形圖（Waveform）即時查看晶片內部的每一個運算結果

3. 自動化測試與自我檢查（Self-Checking）
* 可以寫入預期結果（Golden Model），當電路輸出錯誤時，Testbench 會自動在終端機列印

4. Testbench 與一般RTL電路的差別

| 特性 | 一般 RTL 電路 (Design) | 測試平台 Testbench |
| --- | --- | --- |
| 最終去處 | 會被合成門陣列，燒錄進晶片 | 只在電腦軟體中執行，不會變成實體晶片 |
| 最終去處 | 嚴格，只能寫「可合成 (Synthesizable)」語法 | 寬鬆，可以使用延遲 #、印出文字 $display 等模擬專用語法 |
| 輸入輸出 | 有 input 與 output ports（腳位） | 沒有 ports（最外圍封閉的虛擬測試環境）|

### Testbench 基本語法
1. 時間單位與精度 (``timescale`)
* 放在檔案最開頭，用來指定 # 代表多少時間
```verilog
`timescale 1ns / 1ps  
// 前者 1ns 表示單位（#10 代表 10ns）
// 後者 1ps 表示模擬精度（可精確到 0.001ns）
```

2. 模組宣告（無 Input / Output 腳位）
* Testbench 是一個封閉的虛擬測試環境，所以不需要定義 Port 腳位
```verilog
module tb_example();  /
    // 裡面存放訊號與測試邏輯
endmodule
```

3. 訊號型態宣告 (reg 與 wire)
* 對應你要測試的主電路（UUT, Unit Under Test）：
  * reg：用來連接主電路的 input（由 Testbench 賦值與控制）
  * wire：用來連接主電路的 output（接收主電路輸出的結果，用於觀察波形）
```verilog
reg        clk;     // 輸入給主電路的時脈
reg        rst_n;   // 輸入給主電路的重置
reg  [7:0] data_in; // 輸入給主電路的資料

wire [7:0] data_out;// 接收主電路的輸出
```

4. 實例化主電路 (Instantiation)
```verilog
// 格式：主電路名稱 實體名稱 (.主電路腳位(Testbench訊號))
my_design uut (
    .clk     (clk),
    .rst_n   (rst_n),
    .in_a    (data_in),
    .out_b   (data_out)
);
```

5. 時脈 (Clock) 生成
* 模擬器裡沒有實體晶片的震盪器，必須自己寫邏輯來產生 clk
```verilog
// 方式 A：使用 initial 與 forever（最常見）
initial begin
    clk = 0;
    forever #10 clk = ~clk; // 每 10ns 翻轉一次，產生 50MHz 的時脈（週期 20ns）
end

// 方式 B：使用 always
initial clk = 0;
always #10 clk = ~clk;
```

6. 測試流程控制 (initial 區塊與 # 延遲)
* initial 裡面的程式碼只會從第 0 秒開始執行一次，並且由上到下依序執行。# 代表等待的時間
```verilog
initial begin
    // 1. 初始化訊號
    clk     = 0;
    rst_n   = 0;  // 觸發低電位重置
    data_in = 8'd0;

    // 2. 等待 50ns 後解除重置
    #50;
    rst_n   = 1;

    // 3. 依序給予測試資料
    #20; data_in = 8'd15;  // 20ns 後把 data_in 改成 15
    #20; data_in = 8'd42;  // 再過 20ns 改成 42
    #100;

    // 4. 結束模擬
    $finish; 
end
```

7. 文字列印與監控系統任務 ($display, $monitor)
* 類似 C 語言的 printf，可以在 Vivado 下方的 Tcl Console 視窗印出文字資訊，方便快速除錯
  * $display：程式執行到該行時只印出一張單點資訊
  * $monitor：只要監控的變數有變化，就會自動印出來（常用於即時追蹤）
```verilog
initial begin
    // 當 data_in 或 data_out 發生改變時，自動印出時間與數值
    $monitor("Time=%0t ns | in=%d | out=%d", $time, data_in, data_out);
end

initial begin
    #100;
    $display("模擬結束！當前 data_out 為：%d", data_out);
end
```

8. 自動檢查輸出 (if - else 與 $fatal)
* 可以寫邏輯讓 Testbench 自己比對輸出是否正確，省去親自看波形的麻煩。
```verilog
#20;
if (data_out !== 8'd57) begin
    $display("錯誤：計算結果不符合預期！");
    $finish; // 或者使用 $fatal; 強制終止模擬
end else begin
    $display("正確！結果符合 57");
end
```

[回目錄](#toc)

---

<a id="m07d24"></a>

## 2026 年 7 月 24 日

## 今日進度：
### 影片：[財經村長 - 如何面試上一線數位IC公司 II](https://www.youtube.com/watch?v=Xo0VADH-yX4&t=1448s)

## 關鍵知識/詞彙：
### 亞穩態深度解析
<img width="347" height="207" alt="image" src="https://github.com/user-attachments/assets/74ab4088-2dd4-44e8-999e-9b247d2b1e2c" />

1. 為何會發生：
   * 對 DFF 而言，clock edge 附近有兩個限制：
     * Setup time：clock edge 前資料要先穩定一段時間
     * Hold time：clock edge 後資料還要再穩定一段時間
   * 如果 D 在這個視窗內跳動（setup/hold violation），FF 內部的兩個反相器回授會被推到一個「平衡點」附近，進入亞穩態，Q 輸出無法預測。

2. 最常見的發生場景：
   * Clock Domain Crossing（CDC）：非同步訊號或另一個 clock domain 的訊號，進入本 domain 直接被 FF 取樣，最易觸發亞穩態。
   * 非同步 Reset/Interrupt 解除：reset deassert 或外部中斷若沒有同步處理，也會在 clock edge 附近發生問題。

3.解決方案：
* 單 bit：2-FF Synchronizer（最常見）
   *用兩個站存器讓 Data 有時間充放電，接收較穩定的資料，適用場景 1bit
   * 把非同步訊號先送進兩級 FF（同一個 clock）：async_in -> FF1 -> FF2 -> sync_out。FF1 可能亞穩，但大多在下一拍前收斂；FF2 取到的就穩很多。
   * 設計簡單、overhead 低，是標準做法。（降頻、將兩邊頻率改為倍數關係...）
* 多 bit 資料：需更完整機制
   * 多 bit 不能只用 2-FF，需要：握手協議（valid/ready、req/ack）、Async FIFO（含 Gray code 指標）、或 source-synchronous 架構，確保資料整體一致性
* 硬體選型與時序餘裕
   * 選用 library 中 metastability-hardened flop、降頻、改善 clock 品質、降低抖動、增加 slack，從根本降低亞穩態發生機率（以 MTBF 指標衡量）。

### CDC : Clock Domain Crossing 跨時鐘域
1. 簡介：
   * 指一個訊號或資料從 Clock A 的邏輯，跑到 Clock B 的邏輯，而且 A、B 的時鐘彼此不同步（頻率不同或相位不固定）。因為取樣點不受控，容易引發多種嚴重問題。

2. 狀況類型
   * 亞穩態（Metastability）
     * B 域的 FF 在某個 clock edge 取樣到「正在變化」的 A 域訊號，Q 可能晚很久才穩定，導致下一級邏輯誤判。這是 CDC 最根本的危險。
   * 資料撕裂（Multi-bit Tearing）
     * 多位元資料若各 bit 不是同時穩定，B 域可能抓到「一半舊值、一半新值」，形成根本不存在的數值，造成邏輯錯誤。
   * 事件丟失/重複（Pulse Crossing）
     * A 域的一個短脈波，在 B 域可能太窄被漏掉；或因為同步過程被延長而被看成兩次事件，導致功能異常。（快傳至慢：資料遺失；慢傳至快：重複執行）

3. 設計原則
   * 在現代 SoC 設計中，CDC 問題是導致晶片流片失敗的常見原因之一。正確的 CDC 處理策略（同步器、握手、FIFO）必須在架構設計階段就明確規劃，而非事後修補。

### Async FIFO 設計：Gray Code 指標的重要性
<img width="482" height="311" alt="image" src="https://github.com/user-attachments/assets/881d502d-0645-4a13-8445-bd297fb20372" />

1. 簡介
   * 是解決多 bit CDC 問題的標準方案，其核心挑戰在於讀指標（在讀 clock 域）與寫指標（在寫 clock 域）需要跨越 clock domain 比較。

2. 使用 Gray Code 的關鍵原因：
   * Gray Code 相鄰數值只有 1 bit 改變，即使在 CDC 過程中發生亞穩態，最多只影響 1 bit，確保指標比較的正確性。
   * 而 Binary Code 相鄰值可能多個 bit 同時改變，CDC 過程中可能讀到中間過渡值，造成 FIFO full/empty 判斷錯誤。

3. 注意事項
   * Full Flag／Empty Flag產生
   * 深度選擇
     * 需根據兩個 clock 的頻率差與突發資料量計算。預留足夠的 margin 以容納同步延遲（通常 2~3 個 cycle）。

### 低功耗設計（Low Power Design）
1. 時脈閘控技術（Clock Gating）
   * 通常運用在邏輯合成期間。其中的暫存器（flops）被優化成時脈閘控結構，進而節省了多工器（MUX）的面積，並減少整個時脈網路（clock net）的開關活動。
   * 根據動態功率方程式 <img width="188" height="25" alt="image" src="https://github.com/user-attachments/assets/d37f2729-0db1-4434-9320-cd81f2a23d2a" />
   ，時脈閘控的目標是：
     * 降低電容負載（透過面積減少）
     * 減少開關活動因子（關閉不必要的翻轉）
   * 特性與適用場景：
     * 優點：技術簡單、易於實現，大多數 EDA 工具與標準流程均支援，幾乎零風險。
     * 缺點：需依賴邏輯合成工具執行優化，工程師需正確撰寫 RTL 並設定合成條件。
     * 適用：模塊在部分時間不需要運作時，閘控其 clock，避免無效翻轉消耗動態功率。
     * 典型節省：通常可降低整體動態功耗 20%~40%，視設計而異。 

2. 多電壓技術（Multi Voltage / Voltage Islands）
<img width="474" height="317" alt="image" src="https://github.com/user-attachments/assets/35622b49-701c-4446-a534-8f1631b51acd" />

   * 藉由性能特性來區分晶片功能的技術。晶片上某個模塊是高性能的（需要較高電壓以達到速度要求），而其餘部分性能較低，可使用較低電壓運作。
   * 高電壓高頻率的地方使用自己的能耗，低電壓低頻率的地方使用自己的能耗。
   * 根據功率方程式，電壓降低，靜態與動態功耗均降低，因此低性能模塊使用低電壓可顯著節省功耗。
   * 設計複雜度
     * 電壓島（Voltage Islands）：不同電壓域在 layout 上的物理區域劃分
     * Level Shifter（LS）：不同電壓交叉點必須插入電壓位準偏移器，確保訊號電平相容
     * 需要在不同電壓特性下分別分析各模塊的時序、功耗與可靠性
     * UPF（Unified Power Format）或 CPF 格式描述電源意圖

3. 電源閘控技術（Power Gating）
<img width="432" height="318" alt="image" src="https://github.com/user-attachments/assets/8086a184-b5a3-413d-b5cb-ea78cd5c494f" />

   * 如同多電壓技術，晶片上的功能被區分開來，但此技術在功率區域的電源連接了電源開關（Power Switch），可以有效地完全關閉一個模塊的電源。
   * 功率方程式中，將電壓歸零也會使功耗歸零，進而在模塊關閉時同時節省靜態與動態功率，是所有技術中節能效果最佳的。
   * 必要設計元素
     * 電源開關（Power Switch）：控制模塊電源的 ON/OFF
     * 隔離閘（Isolation Gate）：電源關閉時，提供電源區域邊界一個已知狀態（通常為 0 或 1），避免浮接訊號影響其他模塊
     * 電源管理單元（PMU）：控制電源開關與隔離單元的致能訊號，確保斷電與通電有正確的啟動順序
     * 電源狀態表：定義所有電壓 ON/OFF 的狀態組合
   * 當關閉時，module 裡面的每個模組都有自己的 state ，須妥善傳輸與保存（還是須讓下一個module知道狀態）

4. 電源閘控時的保存狀態（State Retention）
<img width="489" height="347" alt="image" src="https://github.com/user-attachments/assets/f4ba1e1e-6ce0-410b-8aa4-69925c1ee50f" />

   * 狀態保存技術（或稱暫存器保存技術，Register Retention）是一種與電源閘控配合使用的技術。在每個關閉的模塊中，當模塊為 OFF 狀態時，模塊中部分或全部的暫存器會保存其原先的數值。當模塊通電時，之前保存的數值就會被恢復。
   * 若不保存狀態，模塊重新上電後必須從 INIT 狀態重新執行，耗費額外的時間與功率。保存狀態可以讓模塊快速恢復至斷電前的運作狀態，大幅縮短喚醒時間，對需要頻繁睡眠/喚醒的應用（如手機 SoC）至關重要。
   * 實現需求：
     * 元件資料庫中需有保存型暫存器（Retention Flop），具備額外的 Shadow Register 儲存保存值
     * PMU 訊號控制序列中需加入 SAVE / RESTORE 訊號
     * 在斷電前執行 SAVE，上電穩定後執行 RESTORE，確保順序正確
     * UPF 中需明確指定哪些 FF 需要 retention 屬性
     * Retention Flop 與普通 Flop 的差異：
       * Retention Flop 內部有一個由獨立低功耗電源供電的 shadow latch，在主電源關閉時保存資料，主電源恢復後再還原。

### Stuck-at Fault 可測性分析
1. 通常為晶片 Tape out 回來之後有些Pattern要打，確定晶片有無問題
2. 測試概念：
   * 要偵測 Stuck-at 1，需要讓正常電路輸出 0，若輸出為 1 則表示有故障。要偵測 Stuck-at 0，則需讓正常輸出為 1。若電路結構上無法讓故障點呈現正確值，即為不可測故障。

[回目錄](#toc)

---

<a id="m07d25"></a>

## 2026 年 7 月 25 日

## 今日進度：
### 影片：
1. [第1講 Vivado設計流程及使用模式](https://www.youtube.com/watch?v=9pylHMr0yfE&t=1s)
2. [How to use Vivado® Design Suite Part-5 Timing Summary Report](https://www.youtube.com/watch?v=zLs8P_PbAV4)
3. [63 - Vivado's Timing Reports](https://www.youtube.com/watch?v=Gdt5IBKGQos&t=254s)
4. [Xilinx Vivado Tutorial: Timing Analysis and Critical Path Optimization](https://www.youtube.com/watch?v=sc8LOViD0Jg&t=317s)

## 關鍵知識/詞彙：
### Vivado 完整流程概念
<img width="264" height="230" alt="image" src="https://github.com/user-attachments/assets/78066304-e249-4fa9-b87c-ba7c289a82c7" />

1. Simulation（模擬）
   * 主要作用： 執行 Behavioral Simulation（行為級模擬）。
   * 搭配你寫好的 Testbench 跑波形圖（Waveform）。在完全不需要連接任何硬體板子的情況下，先確認寫好的 Verilog/VHDL 邏輯功能是否正確。

2. RTL Analysis（RTL 分析 / 電路結構檢視）
   * 主要作用： 展開程式碼的 Schematic（電路原理圖） 與語法檢查。
   * 軟體會初步解析你的程式碼，把它畫成邏輯閘、暫存器（Flip-Flops）與多工器（Mux）組成的架構圖。你可以用它來確認： Vivado 解讀出的電路結構，是否跟自己所想像的一模一樣。
     
3. Synthesis（邏輯綜合）
   * 主要作用： 將文字程式碼轉換為門級網表（Gate-level Netlist）。
   * 軟體會把你寫的抽象邏輯（如 +、 -、 if-else），翻譯成 FPGA 晶片內部實際存在的底層單元，例如 LUT (Look-Up Table)、Flip-Flop (FF) 和 Block RAM。
     
4. Implementation（布局與布線 - Place & Route）
   * 主要作用： 將綜合後的電路實體化，並進行時序分析。
   * Placement (布局)： 決定把 Synthesis 產生的 LUT 和 FF 放到 FPGA 晶片上的哪個具體物理位置。
   * Routing (布線)： 將晶片內部的金屬導線接通。
   * Timing Analysis (時序分析)： 檢查訊號傳輸速度是否太慢、會不會產生 Setup/Hold Time 違規（Timing Violation）。

5. Program and Debug（燒錄與硬體除錯）
   * 主要作用： 生成燒錄檔、連線 FPGA 開發板與在線除錯。
   * Generate Bitstream： 將 Implementation 的結果打包成 .bit 燒錄檔。
   * Hardware Manager： 透過 USB 線連接開發板，把 .bit 檔燒進 FPGA 晶片。
   Logic Analyzer (ILA)： 當板子運作不正常時，可以在晶片內加入抓訊號的儀器，即時回傳晶片內部的波形到 Vivado 畫面上進行除錯。

6. 標準開發流程順序：
   * Simulation (先模擬) -> Synthesis (邏輯綜合) -> Implementation (布局布線) -> Program and Debug (產出 bit 檔並燒錄)

### XDC 檔（Xilinx Design Constraints）
1. 簡介
   * Vivado 的約束檔（Constraint File），副檔名為 .xdc。
   * XDC 檔就是指定「這個器官要連接到 FPGA 晶片的哪一個實體腳位」，以及「系統的時脈頻率是多少」。

2. XDC 檔最常見的兩大功能：
   * Pin Assignment（管腳約束 / 腳位綁定）：指定你的輸入輸出訊號對應到板子上的哪個按鈕或 LED 燈。
     ```verilog
     # 把 LED 訊號綁定到 FPGA 的 Y13 腳位，並設定電壓標準為 LVCMOS33
		set_property PACKAGE_PIN Y13 [get_ports {led}]
		set_property IOSTANDARD LVCMOS33 [get_ports {led}]
     ```
   * Clock Constraint（時脈約束）：告訴 Vivado 你的 Clock 頻率是多少（讓 Vivado 知道怎麼計算 WNS 報告）。
     ```verilog
     # 告訴 Vivado，sys_clk 這個腳位輸入的時脈週期是 10ns (也就是 100MHz)
		create_clock -period 10.000 -name sys_clk [get_ports sys_clk]
     ```
   
### Timing Report（時序報告）
<img width="756" height="125" alt="image" src="https://github.com/user-attachments/assets/b2da2c7b-28ca-4346-b51f-6256f45d8d5e" />

<img width="1358" height="725" alt="image" src="https://github.com/user-attachments/assets/18e836a5-0775-4527-a430-e66fdf442b1d" />


1. 簡介
   * 跑完 Implementation 後，Vivado 會幫你做全面嚴格的「時序檢查」。
   * 就像是電路的「體檢報告」。它告訴你：你的電路傳輸速度，能不能跟上你設定的 Clock（時脈）頻率？

2. 報告中最重要的地方
   * 最核心的就是查看電路有沒有 Timing Violation（時序違規），也就是訊號會不會「來不及跑完」。
   * 標準就是 Slack（時序裕量）：
     * Slack > 0（綠色）： 訊號傳輸時間綽綽有餘，電路可以在預期頻率下完美運作。
     * Slack < 0（紅色）： 訊號傳輸太慢了（Setup Time Violation）或太快了（Hold Time Violation），電路在實體晶片上會出錯（爆 Bug）。

3. WNS（Worst Negative Slack 最壞負裕量）
   * 定義： 全晶片所有路徑中，最嚴重的那條「延遲/卡頓」路徑缺了多少時間。
   * 重點評估：
     * 如果 WNS >= 0 ns：代表整張晶片的時序全部過關（Timing Met）。
     * 如果 WNS = -1.2 ns：代表最慢的那條路徑，超出了規定的時脈週期 1.2 ns，須優化程式碼或降低 Clock 頻率。

### Utilization 報告（資源使用率）
<img width="380" height="205" alt="image" src="https://github.com/user-attachments/assets/3470d57f-b3f7-48f5-b4ce-1e9914a2fe44" />

1. 定義： 你的程式碼佔用了這顆 FPGA 晶片百分之多少的硬體資源。
   
2. 重要性： 觀察晶片會不會「被塞爆」。如果 Utilization 超過 80% ~ 90%，Vivado 的 Implementation 會變得極度困難，甚至會導致時序爆發（WNS 變成負值）。
   
3. LUT / FF 用量

| 資源名稱 | 全名 | 核心功能與作用 |
| :--- | :--- | :--- |
| LUT | Look-Up Table (查找表) | 實現**組合邏輯（Combinational Logic）**。例如加法、減法、`if-else`、`case` 判斷。 |
| FF | Flip-Flop (觸發器/暫存器) | 實現**時序邏輯（Sequential Logic）**。用來儲存 1 bit 的資料，必須靠 Clock 驅動。 |

### 實際開發的連鎖反應
1. Timing Report、Utilization兩個報告要「一起看」
   * 如果 Utilization 報告顯示 LUT / FF 用量超過 80%~90%，晶片裡面會變得非常擁擠。Vivado 在做 Implementation時，被迫要把相連的邏輯放到距離很遠的地方，繞很長的金屬線。會導致訊號傳輸延遲大幅增加，最後在 Timing Report 裡跳出紅色的 WNS < 0（時序違規）。

[回目錄](#toc)

---

<a id="m07d27"></a>

## 2026 年 7 月 27 日

## 今日進度：
### 資料：
1. [Barrel Shifters in Verilog: A Beginner’s Guide to Fast Multi-Bit Shifting](https://medium.com/@ahe24mobile/barrel-shifters-in-verilog-a-beginners-guide-to-fast-multi-bit-shifting-121d1c5a2b62)
2. [How to Design an Efficient Barrel Shifter in Verilog: Step-by-Step Guide](https://vlsifacts.com/how-to-design-an-efficient-barrel-shifter-in-verilog-step-by-step-guide/)

## 今日成果探討：
### 32bit_ALU_V1（Baseline）- 設計初步 32-bit 構造、模型以及所支援的運算
<img width="544" height="316" alt="image" src="https://github.com/user-attachments/assets/edfdfcaf-8039-4a88-8e76-640d7a6a100d" />
<img width="923" height="507" alt="image" src="https://github.com/user-attachments/assets/24a57abe-c425-42a0-8ac1-af8253aafec1" />

### 8-bit Logical Left Barrel Shifter
* Design sources
```verilog
module Logical_Left_Barrel_Shifter(

    input [7:0]d_in,
    input [2:0]shamt,
    output [7:0]d_out
    
 );
    
    wire [7:0] t1, t2;
    
    // Shift by 1 bit if shamt第 0 位 == 1
    assign t1 = shamt[0] ? {d_in[6:0], 1'b0} : d_in;
    // Shift by 2 bit if shamt第 1 位 == 1
    assign t2 = shamt[1] ? {t1[5:0], 2'b00} : t1;
    // Shift by 4 bit if shamt第 2 位 == 1
    assign d_out = shamt[2] ? {t2[3:0], 4'b0000} : t2;
    
endmodule
```

* Simulation sources
```verilog
module barrel_shifter_tt();

reg [7:0]d_in;
reg [2:0]shamt;
wire [7:0]d_out;

Logical_Left_Barrel_Shifter tt(
    .d_in(d_in),
    .shamt(shamt),
    .d_out(d_out)
);

initial begin
    d_in = 8'b10110011; // Initialize input data 
    // Test all shift amounts from 0 to 7
    for(shamt=0; shamt<8; shamt=shamt+1)begin
        #10;// Wait 10 time units for output to stabilize
        $display("Time=%0t | shift_amt=%0d | data_in=%b | data_out=%b"
        ,$time, shamt, d_in, d_out);
    end
    #10;
    $finish;
end
```

* 模擬結果
<img width="536" height="377" alt="image" src="https://github.com/user-attachments/assets/3b93234d-1639-46c6-b798-0b28319c5f0f" />
<img width="512" height="159" alt="image" src="https://github.com/user-attachments/assets/1bba3fc9-40d6-4fe6-8058-f67cada8dd00" />



## 關鍵知識/詞彙：
### 邏輯移位／算數移位
1. 左移與右移的核心差別
   * 數學語意上的不同（乘法 vs 除法）：
     * 左移（Left Shift）： 位元向高位移動，數值上等同於乘以 2^n
     * 右移（Right Shift）： 位元向低位移動，數值上等同於除以 2^n（自動向下取整）

   * 補位規則的對稱性：
     * 左移（<< / <<<）： 補位行為完全對稱且一致，無論是邏輯還是算術，右側（LSB）空出來的位置一律補 0
     * 右移（>> / >>>）： 是算術與邏輯差異最顯著之處。邏輯右移左側永遠補 0；算術右移（且變數為 signed）左側會補最高有效位（MSB，即正數補 0、負數補 1），用以保持負數的數值正確性
  
   * 邊界溢位與精度損失：
     * 左移容易造成高位溢位（Overflow），若接收變數的位元寬度不夠，最左側的位元將會被丟棄
     * 右移則會造成低位精度的捨棄（Truncation），最右側移出的位元會直接丟失（相當於整數除法捨去餘數）。

2. 邏輯移位 vs 算術移位比較表

| 比較項目 | 邏輯移位 (Logical Shift) | 算術移位 (Arithmetic Shift) |
| :--- | :--- | :--- |
| **語法運算子** | `<<`（左移）、`>>`（右移） | `<<<`（左移）、`>>>`（右移） |
| **符號屬性 (Signedness)** | 強制作為 **Unsigned（無符號）** 處理 | 保留 **Signed（有符號）** 屬性<br>*(須宣告為 `signed` 變數)* |
| **左移補位行為** | 右側永遠**補 0** | 右側永遠**補 0**（與邏輯左移相同） |
| **右移補位行為** | 左側（MSB）永遠**補 0** | 若變數為 signed 則**補符號位 (MSB)**<br>若變數為 unsigned 則**補 0** |
| **位元擴展行為<br>(Sign Extension)** | 賦值給較長位元時，高位直接**補 0** | 賦值給較長位元時，依據符號位進行**符號擴展** |
| **主要應用場景** | 資料封包拆解、Mask 遮罩、純位元操作 | 有符號數的數學快速乘除法（2 的次方的乘除） |

### 桶型移位器 (Barrel Shifter) 
1. 簡介：是一種純組合邏輯電路，其最大特點為「可以在單一時脈週期內將資料向左或向右移動任意位數」

2. 運作原理：內部通常由多級 Multiplexer（MUX）對角線式連接而成。以 8-bit Barrel Shifter 為例，內部設計為 3 級 MUX：
   * 第 1 級決定是否移位 1 位 (2^0)
   * 第 2 級決定是否移位 2 位 (2^1)
   * 第 3 級決定是否移位 4 位 (2^2)
   * 藉由這些 2 的次方組合，即可在極短的組合邏輯延遲（O(\log N)）內完成 0~7 位的任意移位。

3. 適用情境：廣泛應用於現代 CPU 的 ALU（算術邏輯單元）與 DSP 中，用來支援單指令週期的位移操作。

### 一般移位暫存器 (Standard Shift Register)
1. 簡介：是一種時序邏輯電路，由多個 Flip-Flop（觸發器）串聯而成。

2. 運作原理：在每一個時脈邊緣（Clock Edge）到來時，資料會從前一級 Flip-Flop 傳遞到下一級，實現「每次 Clock 只移動 1 位元」的行為。
   * 優缺點： 雖然若要移位 N 位元需要花費 N 個時脈週期（吞吐量較低），但其電路結構非常簡潔、佔用晶片面積小，且沒有複雜的組合邏輯延遲問題。

3. 適用情境：適合用於串列通訊資料轉換（如 SPI、UART、I2C 的 SIPO / PISO 轉換）或暫存佇列（Shift Register FIFO）。

### Barrel Shifter vs 一般移位暫存器比較表

| 比較項目 | Barrel Shifter（桶型移位器） | 一般移位暫存器 (Standard Shift Register) |
| :--- | :--- | :--- |
| **核心架構** | 多級多工器（Multiplexer Array）組合邏輯 | 觸發器（D Flip-Flop）級聯串列時序電路 |
| **電路類型** | **純組合邏輯 (Combinational Logic)** | **時序邏輯 (Sequential Logic)** |
| **移位時間 (延遲)** | **1 個時脈週期內 (1 Clock Cycle)** 完成任意 $N$ 位元移位（延遲為 $O(\log N)$） | 需要 **$N$ 個時脈週期 (N Clock Cycles)** 才能移位 $N$ 位元（延遲為 $O(N)$） |
| **硬體資源 (面積)** | 較高，隨位元數成 $O(N \log N)$ 成長（大量 MUX） | 較低，隨位元數成 $O(N)$ 成長（僅需 DFF 與少許邏輯） |
| **關鍵路徑/延遲** | 組合邏輯線路較長（Gate Delay 較大），容易成為 Critical Path | 每個 Cycle 延遲極小（僅 DFF 的 $T_{co}$），易於達成高 Clock Frequency |
| **移位位數彈性** | 任意位數可單一週期直接指定（如直接移 5 位） | 逐位移位，移幾位就需要幾個 Clock 觸發 |
| **主要應用場景** | ALU、浮點數運算單元 (FPU)、DSP 算術運算、處理器指令集 (ARM Shifter) | 串列/並列轉換 (SIPO/PISO)、通訊介面 (SPI/UART)、資料緩衝佇列 |

* Trade-off when using Barrel Shifter：需要更多的邏輯電路（例如，a tree of multiplexers），從而換取更高的速度。當需要在一個週期內進行變速時，這種方法是值得的。

[回目錄](#toc)

---

<a id="m07d28"></a>

## 2026 年 7 月 28 日

## 今日進度：
### 資料：
1. [Verilog code for Arithmetic Logic Unit (ALU)](https://www.fpga4student.com/2017/06/Verilog-code-for-ALU.html)
2. [ALU design in Verilog using MIPS Instruction Set](https://electrobinary.blogspot.com/2021/02/alu-design-in-verilog-using-mips.html)

## 今日成果探討：
### ALU 設計：
### 32bit_ALU_V1（Baseline）- 完成 32-bit ALU baseline 版本與 debug 
* Design sources
```verilog
module alu_v1(
    input [31:0]a,
    input [31:0]b,
    input [2:0]op_code,
    output reg[31:0]res,
    output [3:0]flag
);
    //構建4個 32bit 暫存器用於 barrel shifter
    //Shamt 選用 b[4:0] 判斷移動幾個 bit
    reg [31:0]t1, t2, t3, t4;
    
    // 構建共用的 33-bit 加減法邏輯（在 case 外面算）
    wire sub;
    wire [31:0]b_op;
    wire [32:0]add_sub;
    wire carry;
    wire overflow;

    assign sub = (op_code == 3'b001);// op_code == 3'b001，執行減法
    assign b_op = b ^ {32{sub}}; // 將 b 逐位元反相
    assign add_sub = {1'b0, a} + {1'b0, b_op} + sub; // ADD: a+b；SUB: a + ~b + 1（2補數，+1 由 sub 提供）
    assign carry = add_sub[32]; //進位判斷 
    assign overflow = (~(a[31] ^ b_op[31])) && (a[31] ^ add_sub[31]);//溢位判斷

// 判斷 ALU 行為
always@(*)begin
    case(op_code)
        3'b000 : // a+b
            res = add_sub[31:0]; 
        3'b001 : // a-b 
            res = add_sub[31:0];
        3'b010 : 
            res = a & b;
        3'b011 : 
            res = a | b;
        3'b100 : 
            res = a ^ b;
        3'b101 : begin // 邏輯左移(<<)，缺項補0
            t1 = (b[0]) ? {a[30:0], 1'b0} : a;
            t2 = (b[1]) ? {t1[29:0], 2'b00} : t1;
            t3 = (b[2]) ? {t2[27:0], 4'b0000} : t2;
            t4 = (b[3]) ? {t3[23:0], 8'b00000000} : t3;
            res = (b[4]) ? {t4[15:0], 16'b00000000} : t4;
        end 
        3'b110 : begin // 算術右移(>>>)，補 signed bit a[31]
            t1 = (b[0]) ? {a[31], a[31:1]} : a;
            t2 = (b[1]) ? {{2{a[31]}}, t1[31:2]} : t1;
            t3 = (b[2]) ? {{4{a[31]}}, t2[31:4]} : t2;
            t4 = (b[3]) ? {{8{a[31]}}, t3[31:8]} : t3;
            res = (b[4]) ? {{16{a[31]}}, t4[31:16]} : t4; 
        end
        3'b111 : res = ($signed(a) < $signed(b)) ? 32'd1 : 32'd0; // 有號數比較
        default : res = 32'd0;
    endcase
end

// 構建 flag
wire a_s;
wire Z, N, C, V;

// flag 只在 ADD/SUB 時才有意義
assign a_s = (op_code == 3'b000) || (op_code == 3'b001);

assign Z = (res == 32'd0) ? 1 : 0; // 零旗標判斷
assign N = (res[31]) ? 1 : 0; // 負旗標判斷
assign C = (a_s) ? carry : 0; // 進位旗標判斷
assign V = (a_s) ? overflow : 0; // 溢位旗標判斷
    
assign flag = {Z, N, C, V}; // flag[3]=Z, flag[2]=N, flag[1]=C, flag[0]=V

endmodule
```

* Simulation sources
```verilog
module alu_v1_tt();

    reg [31:0]a, b;
    reg [2:0]op_code;
    wire [31:0]res;
    wire [3:0]flag;
    integer i;
    
    alu_v1 tt(
    .a(a),
    .b(b),
    .op_code(op_code),
    .res(res),
    .flag(flag)
    );
    
    initial begin
    $monitor("time=%0t op_code=%b a=%h b=%h res=%h flag=%b", $time, op_code, a, b, res, flag);
    a = 32'hF150A1B8;
    b = 32'h5F58258;
    for (i = 0; i < 8; i = i + 1) begin
        op_code = i[2:0];   // 對應 000~111
        #10;
    end
    $finish;   
    end   
endmodule
```

* 模擬結果
<img width="745" height="377" alt="image" src="https://github.com/user-attachments/assets/28336d72-38ed-4462-ac23-e0a8f90fb22c" />

## 遇到的困難與解決方案：
### 問題1：SLT 比較負數時判斷結果錯誤
* 原因：Verilog 的 wire/reg 預設是 unsigned，`a < b` 這種比較不會考慮 2 補數的符號位，導致負數被當成很大的正數去比大小
* 解法：用 `$signed()` 這個系統函式，把 `a`、`b` 重新解讀成有號數再比較
* 程式碼：
  ```verilog
	res = ($signed(a) < $signed(b)) ? 32'd1 : 32'd0;
  ```

### 問題2：一開始搞混了 signed() 跟 ~b+1 的用途，以為 a + $signed(b) 可以拿來做減法
* 原因：誤以為 `$signed()` 會「改變」訊號的數值
* 釐清後的觀念：
  * `$signed()` 是**重新解讀（reinterpretation）**：不會動任何一個 bit，只是告訴後面的運算子「把最高位當符號位去解讀」，本質上像加一個濾鏡去看同一份資料
  * `~b + 1` 是**數值轉換（value transformation）**：把每個 bit 反相再加 1，算出一個新的數值（2 補數的 -b）
  * 減法需要的是「真的把 b 變成 -b」，屬於數值轉換，`$signed()` 做不到這件事
* 另外發現：想共用加法器做減法、還要順便算 carry/overflow 時，要把 `a`、`b` 都多補一位變成 33-bit 再相加，「多留一個 bit 裝進位」的動作，`$signed()` 也做不到
* 程式碼：
  ```verilog
	// 構建共用的 33-bit 加減法邏輯（在 case 外面算）
    wire sub;
    wire [31:0]b_op;
    wire [32:0]add_sub;
    wire carry;
    wire overflow;

    assign sub = (op_code == 3'b001);// op_code == 3'b001，執行減法
    assign b_op = b ^ {32{sub}}; // 將 b 逐位元反相
    assign add_sub = {1'b0, a} + {1'b0, b_op} + sub; // ADD: a+b；SUB: a + ~b + 1（2補數，+1 由 sub 提供）
    assign carry = add_sub[32]; //進位判斷 
    assign overflow = (~(a[31] ^ b_op[31])) && (a[31] ^ add_sub[31]);//溢位判斷
  ```

## 關鍵知識/詞彙：
### Why Compute 33-bit Adder/Subtractor Outside the `always` Block?
#### 1. 資源共享與面積最佳化 (Resource Sharing)
* **傳統寫法問題**：若在 `always @(*)` 的 `case` 內分別寫 `res = a + b` 與 `res = a - b`，綜合工具 (Synthesizer) 容易推論出兩套獨立的 32-bit 加法器與減法器。
* **優化解法**：利用 2 補數原理 ($A + \sim B + 1$)，在外部僅需建置**一套通用加法器**搭配 XOR 邏輯門即可完成加/減法，顯著節省 FPGA LUT 資源與 ASIC 晶片面積。

#### 2. 精準擷取進位與溢位 (Carry & Overflow Detection)
* **位元擴充**：透過 33-bit `{1'b0, a} + {1'b0, b_op} + sub` 運算，防止加法溢出位元（Bit 32）在賦值給 32-bit 暫存器時被強制裁切（Truncate）。
* **訊號擷取**：
  * **Carry Flag ($C$)**：直接擷取最高位 `add_sub[32]`。
  * **Overflow Flag ($V$)**：利用符號位 `a[31]`, `b_op[31]`, `add_sub[31]` 精準推導有號數溢位。

#### 3. 數據通路與控制邏輯解耦 (Datapath & Control Decoupling)
* **Datapath (外部 `assign`)**：負責數據平行運算（加減法、邏輯運算、移位器同時計算）。
* **Control Logic (內部 `always`)**：`always` 區塊退化為**純粹的多路選擇器 (MUX)**，僅負責依 `op_code` 選取運算結果。
* **結構優點**：極大化降低控制邏輯複雜度，並防止在 `always` 邏輯分支不完備時誤推論出 Latch (鎖存器)。

#### 4. 預留 SLT (Set Less Than) 硬體共享路徑
* 在處理有號數比較（SLT）時，若寫 `$signed(a) < $signed(b)` 會額外合成一組比較器 (Comparator)。
* 將減法器放在外部後，SLT 即可直接複用減法器的運算結果與 Flags（$\text{Overflow} \oplus \text{Sign Bit}$），完全不需額外增加硬體運算單元。
---

### $signed()
* Verilog 系統函式，將訊號重新解讀為 2 補數表示的有號數，只改變「詮釋方式」，不改變原始 bit pattern
* 只在該次運算當下生效，不影響同一訊號在其他運算中的解讀方式

### Part Select（位元選取）
* 語法：訊號[高位:低位]，從一個多位元的訊號裡，取出連續一段 bit
* 範例：integer i 是 32-bit 有號數，i[2:0] 代表只取出 i 最低的 3 個 bit（第2、1、0位）
* 用途：當來源訊號位寬比目標訊號寬時，可以用 part select 明確指定要取哪幾位，讓程式碼意圖更清楚

```verilog
integer i;          // 32-bit
reg [2:0] op_code;   // 3-bit

op_code = i[2:0];    // 明確取 i 的最低 3 位給 op_code
```

* 補充：如果直接寫 op_code = i;（不加 part select），Verilog 會自動做**隱含截斷（implicit truncation）**——把較寬的訊號指派給較窄的訊號時，自動只取最低的幾個 bit、捨棄多出來的高位，結果跟 i[2:0] 完全一樣
* 那為什麼寫 i[2:0]：雖然結果一樣，但明寫出來能讓看程式碼的人清楚知道「這是刻意只取低位，不是漏寫」

### 相關語法：Part select 也能用在賦值的左邊
* 不只能「讀取」部分位元，也能只「賦值」給訊號的一部分，例如：
```verilog
reg [7:0] data;
data[3:0] = 4'b1010;   // 只改 data 的低 4 位，高 4 位不受影響
```

[回目錄](#toc)

---

<a id="m07d30"></a>

## 2026 年 7 月 30 日

## 今日進度：
### 刷題：複習 HDLBits 7/3 - 7/17 進度。
### 影片：
1. [A Practical Introduction to Edge AI](https://youtu.be/ibm6ZRi6Sm4?si=yXesCNbBqkw3CrrX)
2. [FPGA 是怎麼被發明的? 一口氣了解 Xilinx 跟 Altera 的 FPGA 爭霸史](https://www.youtube.com/watch?v=kRSLnkOKpPY)
3. [CACM September 2018 - A Domain Specific Architecture for Deep Neural Networks](https://www.youtube.com/watch?v=MbO_pIQLP34)
4. [A Practical Introduction to Edge AI](https://youtu.be/ibm6ZRi6Sm4?si=yXesCNbBqkw3CrrX)

## 關鍵知識/詞彙：
### DSA（Domain Specific Architecture，特定領域架構）
1. 定義：不追求「什麼都能做」的通用處理器（CPU），而是**針對特定任務**（例如矩陣運算、訊號處理、AI 推論）設計專用硬體電路，**犧牲通用性換取效能與能耗效率**。

2. 背景：
	* 摩爾定律放緩，單靠製程微縮已難以大幅提升效能
	* 通用 CPU 為了「什麼都能做」，硬體資源花在指令解碼、分支預測等通用邏輯上，效率不高
	* 特定應用（尤其是深度學習）的運算模式很固定（大量矩陣乘加），適合客製化硬體加速

3. 代表性例子：
	* Google TPU（針對深度學習矩陣運算設計）
	* GPU（針對平行運算優化，通用性介於 CPU 與 DSA 之間）
	* 各種 AI 加速器 IP（NPU）

4. 效能/彈性光譜：
	* CPU（通用）-> GPU（平行）-> DSA/ASIC（專用）
	* 客製化程度越高，效能/能耗比越好，但彈性越差、開發成本越高。

### Edge AI（邊緣運算 AI）
1. 定義：把 AI 推論（inference）放在終端裝置（手機、IoT 裝置、感測器）上執行，而不是把資料傳到雲端伺服器算完再傳回來。
   
2. 優點：
	* 延遲：**本地運算完成**，不需等待網路來回
	* 隱私：資料**不需上傳雲端**
	* 頻寬/成本：不需持續傳輸大量資料
	* 可靠性：**無網路連線**時仍可運作

3. 與 IC 設計的關聯：
	* Edge 裝置多為電池供電、體積受限，因此需要**低功耗、小面積**的 AI 加速器，而非雲端伺服器那種高功耗換高效能的做法
	* 邊緣裝置上的 AI 晶片，是 DSA 概念的實際應用之一：為推論任務特化，同時兼顧功耗與面積
	* 常見技術方向：
  		* 模型量化（以 INT8 甚至更低位元取代浮點運算，節省功耗與面積）
  		* 記憶體存取優化（AI 運算瓶頸常在資料搬移而非運算本身，因此有 In-memory computing 等討論方向）

[回目錄](#toc)

---

<a id="m07d31"></a>

## 2026 年 7 月 31 日

## 今日進度：
### 資料：
1. 複習 7/3 - 7/30 進度
2. [MIT 6.111 課程講義 Lecture 9《Pipelining & Verilog》(PDF)](https://web.mit.edu/6.111/www/f2016/handouts/L09.pdf)

## 關鍵知識/詞彙：
### Pipeline（管線化 / 流水線）
* 一種資料路徑設計技巧，把一段長的組合邏輯切成幾個較短的階段，中間插入暫存器，讓每個階段各自在一個 clock cycle 內完成
* 核心目的：**不是縮短單一筆資料的處理時間，而是提升整體吞吐量（throughput）**，因為每個階段變短了，可以用更高的 clock frequency 運作，而且每個 clock cycle 都能開始處理新的一筆資料

### Latency vs Throughput
* **Latency（延遲）**：一筆資料從輸入到輸出總共花的時間。切了 pipeline 之後，因為多了暫存器，latency 通常會「增加」
* **Throughput（吞吐量）**：單位時間內能處理完幾筆資料。切了 pipeline 之後，滿水位後可以每個 cycle 就出一筆結果，throughput 會明顯提升
* pipeline 設計的核心 **trade-off**：**犧牲一點 latency，換取大幅提升的 throughput**

### 為什麼切 Pipeline 能讓頻率變高
* 電路能跑多快，取決於整條電路裡最長的那條路徑（critical path）
* 例如一個 32-bit RCA 加法器的 critical path 是進位一路傳到最高位的延遲；如果從中間插一個暫存器切成兩段（低16/高16），critical path 就變成只需要走完「半段」的延遲，自然能撐更高的 clock frequency
* 換句話說：pipeline 是用「空間換時間」——多花面積（暫存器）去換取更短的每級延遲

### Balanced Pipeline（平衡管線）
* 切 pipeline 時，如果某條路徑（例如邏輯運算）本身延遲很短，也要跟著切同樣深度的暫存器級數，確保所有分支的資料在「同一拍」到齊
* 常見的錯誤：只把最長的那條路徑（如加法器）切了暫存器，其他較短的路徑忘記跟著切，導致 MUX 選出來的資料其實不是同一時間點的結果，造成功能錯誤

### Pipeline 在單顆 ALU（無資料相依）跟 CPU pipeline 的差別
* 單獨一顆 ALU 電路本身是無狀態（stateless）的組合功能單元，插入 pipeline 不會有 data hazard 問題
* CPU 的五級 pipeline（IF/ID/EX/MEM/WB）裡，hazard 問題來自「指令之間」的相依性（例如下一條指令要用到上一條還沒算完的結果），跟切 ALU 內部的 pipeline 是完全不同層次的問題

[回目錄](#toc)

---

<a id="m08d01"></a>

## 2026 年 8 月 1 日

## 今日成果探討：
### ALU 設計：
### 32bit_ALU_V1（Baseline） - 改寫 32-bit ALU baseline 版本 testbench
* 這次測試設計採用 corner case（邊界案例）驗證思路，針對電路裡最容易出錯的幾個地方各自設計專門的測資，而不是隨機測試。
* golden value（預期結果）全部自己手動用二進位/2補數算過，沒有拿 RTL 邏輯反推，避免用同一套可能有 bug 的邏輯驗證自己。

1. ADD / SUB 基本功能
```verilog
check(32'h0000_00F0, 32'h0000_000F, 3'b000, 32'h0000_00FF, 0,0,0,0); // ADD
check(32'h0000_00F0, 32'h0000_000F, 3'b001, 32'h0000_00E1, 0,0,1,0); // SUB
```
* 用意：先確認共用的 33-bit 加減法邏輯（`add_sub`）在正常數值下功能正確，這是後面所有 flag 判斷的基礎，要先確保這塊沒問題
* SUB 那組刻意讓 `a > b`，驗證正常減法沒有借位時 carry 應該是 1（`C=1`）

2. AND / OR / XOR 邏輯運算覆蓋率
```verilog
check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b010, 32'h0F00_0F00, 0,0,0,0); // AND
check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b011, 32'hFF0F_FF0F, 0,1,0,0); // OR
check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b100, 32'hF00F_F00F, 0,1,0,0); // XOR
```
* 用意：一開始這 3 個運算完全沒被測到，屬於覆蓋率破洞，補上確保 8 個 opcode 全部至少測過一次
* 選用 `FF00FF00` / `0F0F0F0F` 這種棋盤式 bit pattern，方便手動驗算每個 bit 的邏輯結果，也能同時檢查出每組結果的正負號（N flag）算得對不對

3. SRA 符號延伸（sign extension）
```verilog
check(32'hF123_4567, 32'h0000_0004, 3'b110, 32'hFF12_3456, 0,1,0,0); // SRA
```
* 用意：驗證算術右移補的是「符號位」而不是固定補 0。刻意選 `a` 最高位是 1（負數）的數值，因為如果 `a` 是正數，SRA 補符號位跟 SRL 補0結果會一樣，根本測不出補位邏輯有沒有寫對
* `shamt = b[4:0] = 4`，也順便驗證了移位量不是固定值、而是真的照 `b` 的低5位在算

4. ADD Overflow 邊界
```verilog
check(32'h7FFF_FFFF, 32'h0000_0001, 3'b000, 32'h8000_0000, 0,1,0,1); // ADD overflow
```
* 用意：`0x7FFFFFFF` 是 32-bit 有號數能表示的最大正數，加 1 之後理論上會變成 `0x80000000`（有號數解讀下是最負的數），這是刻意設計來觸發 overflow 的邊界案例
* 專門驗證 overflow 判斷式 `(~(a^b_op)) && (a^add_sub)`（兩運算元同號、結果卻異號）有沒有正確抓到這種情況，一般隨便挑的數值很難自然踩到這個邊界

5. SLT 有號數比較
```verilog
check(32'hFFFF_FFFF, 32'h0000_0005, 3'b111, 32'h0000_0001, 0,0,0,0); // SLT
```
* 用意：`0xFFFFFFFF` 當 unsigned 看是一個很大的正數，當 signed 看則是 -1。這組刻意用這個數值，就是要驗證 `$signed(a) < $signed(b)` 有沒有真的把它當成負數處理
* 如果沒加 `$signed`，這組測試會判斷成「4294967295 < 5 為假」，跟正確答案（-1 < 5 為真）相反，是專門抓「忘記處理 signed」這種 bug 的案例

6. Shamt 邊界值（0 與 31）
```verilog
check(32'h0000_0001, 32'h0000_0000, 3'b101, 32'h0000_0001, 0,0,0,0); // shamt=0
check(32'h0000_0001, 32'h0000_001F, 3'b101, 32'h8000_0000, 0,1,0,0); // shamt=31
```
* 用意：移位量的合法範圍是 0~31，這是兩端的極值，最容易被忽略（很多人只測中間值）
* `shamt=0`：驗證「不移位」的情況下，barrel shifter 每一級的 mux 都要正確選到「不動」那個分支，結果應該跟輸入完全一樣
* `shamt=31`：驗證移到底的情況，5 級 mux 全部要選到「移」的那個分支，結果應該只剩最低位的 1 被推到最高位

* Simulation sources
```verilog
module alu_v1_tt();

    reg [31:0]a, b;
    reg [2:0]op_code;
    wire [31:0]res;
    wire [3:0]flag;
    integer i;
    
    integer error_count; // 用於計算"error"次數
    integer test_count; // 用於計算"test"次數
    
    alu_v1 tt(
    .a(a),
    .b(b),
    .op_code(op_code),
    .res(res),
    .flag(flag)
    );
    
    task automatic check(
        input [31:0]t_a, // a的測試變數
        input [31:0]t_b, // b的測試變數
        input [2:0]t_op, // op_code的測試變數
        input [31:0]t_res, // res的測試變數
        input t_z, t_n, t_c, t_v // flag的測試變數
    );
        begin
            a = t_a; b = t_b; op_code = t_op;
            #10;
            test_count = test_count + 1; // 每次開始測試 test_count 次數 +1
            if(res !== t_res || flag !== {t_z, t_n, t_c, t_v})begin // res 結果或 flag 結果不符
                error_count = error_count + 1; // 錯誤就把 error_count 次數 +1
                $display("[FAIL]：%0d, op_code = %b, a = %h, b = %h | got res = %h, flag = %b | t_res = %h, flag = %b",
                test_count, t_op, t_a, t_b, res, flag, t_res, {t_z, t_n, t_c, t_v});
            end
            else begin
                $display("[PASS]：%0d, op_code = %b", test_count, t_op);
            end
        end
    endtask
    
    initial begin
        error_count = 0;
        test_count = 0;
        
        // 基本功能：ADD / SUB 
        check(32'h0000_00F0, 32'h0000_000F, 3'b000, 32'h0000_00FF, 0,0,0,0); // ADD
        check(32'h0000_00F0, 32'h0000_000F, 3'b001, 32'h0000_00E1, 0,0,1,0); // SUB
        
        // 邏輯運算：AND / OR / XOR
        check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b010, 32'h0F00_0F00, 0,0,0,0); // AND
        check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b011, 32'hFF0F_FF0F, 0,1,0,0); // OR
        check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b100, 32'hF00F_F00F, 0,1,0,0); // XOR
        
        // 針對電路容易出錯的地方各自設計測資
        check(32'hF123_4567, 32'h0000_0004, 3'b110, 32'hFF12_3456, 0,1,0,0); // SRA 符號延伸
        check(32'h7FFF_FFFF, 32'h0000_0001, 3'b000, 32'h8000_0000, 0,1,0,1); // ADD overflow
        check(32'hFFFF_FFFF, 32'h0000_0005, 3'b111, 32'h0000_0001, 0,0,0,0); // SLT：-1 < 5
        check(32'h0000_0001, 32'h0000_0000, 3'b101, 32'h0000_0001, 0,0,0,0); // shamt=0
        check(32'h0000_0001, 32'h0000_001F, 3'b101, 32'h8000_0000, 0,1,0,0); // shamt=31
        
        $display("\n測試完成：共 %0d 組，失敗 %0d 組", test_count, error_count);
        if(error_count == 0)begin
            $display("ALL TESTS PASSED");
        end
        $finish;       
    end  
endmodule
```

* 模擬結果
<img width="214" height="251" alt="image" src="https://github.com/user-attachments/assets/806079cd-4cc0-4a13-b4b7-5297b3a1180a" />

## 遇到的困難與解決方案：
### 問題：跑 alu_tt 模擬沒有跑出結果
* 原因：task 內少寫 `#10`，比對時機在 DUT 組合邏輯還沒重新算完前就執行，導致比對到殘留的舊值（race condition）
* 解法：修法是每次改完輸入後一定要留一段延遲再比對

## 關鍵知識/詞彙：
### task
* 用來把一段重複會用到的程序邏輯包裝起來的語法，概念類似其他語言的"函式（function）"，但更專門用於 procedural/testbench 情境
* 語法結構：
```verilog
task automatic 任務名稱(
    input  型別 參數1,
    input  型別 參數2,
    output 型別 參數3   // 也可以有輸出參數
);
    begin
        // 任務內容
    end
endtask
```
* 呼叫方式跟函式一樣：`任務名稱(引數1, 引數2, ...);`

### task vs function 的差別
* `function` 一定要回傳一個值（像數學函式 y=f(x)），且**不能用延遲語法（#10 這種）**
* `task` 不用回傳值，**可以在裡面使用延遲語法**，因為驗證流程常需要「設定輸入 -> 等待一段時間 -> 再比對結果」，所以 testbench 裡通常用 task 而不是 function

### automatic 關鍵字
* 代表這個 task 每次被呼叫時，會重新配置一份獨立的變數空間（可重入 re-entrant）
* 如果不加（預設是 static），task 裡的變數是全域共用同一份，多處同時呼叫同一個 task 時容易互相干擾出錯
* 寫 testbench 時養成習慣加 automatic 比較保險

### task 裡的 input 跟 module port 的 input 不是同一件事
* module 的 input 是硬體接腳
* task 的 input 是「呼叫這個 task 時要傳進來的參數」，性質比較接近程式語言裡函式的參數列表

### task / function 參數為什麼不用寫 reg
* module 的 port 跟 task/function 的參數，是兩套不同的規則：
  * module 的 port 是在描述「電路怎麼接」：input 預設是 wire（外部持續驅動），output 若要在 always/case 裡程序式賦值，必須額外宣告成 reg
  * task/function 的參數本質上是「呼叫時把值複製一份進來、用完就結束」，比較像程式語言裡函式的區域變數，不涉及電路接線的概念
* 因為 task/function 是 procedural（程序式）區塊，Verilog 語法規則直接讓它的 input/output/inout 參數天生具備變數（reg-like）性質，不需要另外寫 reg 宣告

### 呼叫 task 時是「傳值」，不是「型別繼承」
* task 的參數型別（變數）是宣告時就固定的，不會因為呼叫者傳進來的是 wire、reg 還是常數而改變
* 呼叫當下，Verilog 做的是把呼叫者傳進來的「值」複製一份到 task 內部的參數變數裡（類似傳值 pass-by-value），型別本身完全不受呼叫者影響
* 如果傳進去的值位寬跟參數宣告的不一樣，Verilog 會照一般賦值規則自動調整位寬（不夠補0、多的截斷），這跟型別是否為 reg 是兩件獨立的事，位寬調整的規則與 part select 提過的隱含截斷是同一套

### 實際應用：把重複的測試流程包成一個 check task
* 把「設定輸入 -> 等待 -> 比對結果 -> 印出 PASS/FAIL」這套固定流程包成一個 task，之後每測一組資料只要呼叫一次 `check(...)`，不用每次都手動複製貼上重複的程式碼

[回目錄](#toc)

---

<a id="m08d02"></a>

## 2026 年 8 月 2 日

## 今日成果探討：
### ALU 設計：
### 32bit_ALU_V1（Baseline） - 第一次 Synthesis + Implementation 結果，並記錄收斂到 WNS 接近 0 的結果
* Constraints sources - 1st
```
create_clock -period 20 -name clk [get_ports clk]
```

* Constraints sources - 2nd
```
create_clock -period 8 -name clk [get_ports clk]
```

* Constraints sources - 3rd
```
create_clock -period 7.2 -name clk [get_ports clk]
```

* Design sources（wrapper）
```verilog
module alu_v1_wrapper(
    input clk,
    input [31:0]a_in,
    input [31:0]b_in,
    input [2:0]op_in,
    output reg [31:0]res_out,
    output reg  [3:0]flag_out
);
    
    reg [31:0] a_r; // 鎖住輸入的暫存器，posedge clk 時取樣 a_in/b_in
    reg [31:0] b_r;
    reg [2:0] op_r; // 鎖住輸入的暫存器，posedge clk 時取樣 op_in
    wire [31:0] res_w; // alu_v1 算出的組合邏輯結果（尚未鎖存）
    wire [3:0] flag_w; // alu_v1 算出的組合邏輯 flag（尚未鎖存）
    
    always@(posedge clk)begin
        /*
        輸入暫存器：把當下的 a_in/b_in/op_in 取樣鎖住，讓 alu_v1 core 拿到的是穩定值
        ，而不是隨時可能變動的外部輸入
        */
        a_r <= a_in; 
        b_r <= b_in;
        op_r <= op_in;
        // 輸出暫存器：把 alu_v1 算好的組合邏輯結果取樣鎖住，才能輸出穩定的 res_out/flag_out
        res_out <= res_w;
        flag_out <= flag_w;
    end
    
    // alu_v1：純組合邏輯核心，接的是已經被鎖住的 a_r/b_r/op_r（不是原始輸入a_in、b_in、op_in）
    alu_v1 core(
    .a(a_r),
    .b(b_r),
    .op_code(op_r),
    .res(res_w),
    .flag(flag_w) 
    );

endmodule
```

* 模擬結果
1. period 20：
   * 反推 Fmax：`(20 - 10.789) = 9.211ns -> Fmax ≈ 1000 / 9.211 ≈ 108.6MHz`
<img width="1327" height="91" alt="image" src="https://github.com/user-attachments/assets/5a9e0bad-958f-477c-8a87-4f3f2e02cb07" />

2. period 8：
   * 反推 Fmax：`(8 − 0.970) = 7.030ns -> Fmax ≈ 1000 / 7.030 ≈ 142.2 MHz`
<img width="1326" height="88" alt="image" src="https://github.com/user-attachments/assets/abf51b0f-e8e4-490c-9b74-2e08b15c379e" />

3. period 7.2：
   * 反推 Fmax：`(7.2 − 0.516) = 6.684ns -> Fmax ≈ 1000 / 6.684 ≈ 149.6 MHz`
<img width="1327" height="99" alt="image" src="https://github.com/user-attachments/assets/a5696367-fd6b-4b48-9b5b-79145aaacbf5" />

### ALU_V1（Baseline）最終基準線數據
* Period = 7.2 ns, WNS = 0.516 ns
* Fmax ≈ 149.6 MHz
* LUT = 327, FF = 103

### ALU_V2（pipeline） - pipeline ALU 設計規劃
1. 在 alu_v1 中的 critical path
   * Barrel Shifter（桶型移位器）：最主要的 Critical Path
     * 邏輯結構： 採用 5 階串聯的條件選擇器（`b[0]` ~ `b[4]` 對應 1, 2, 4, 8, 16 bits 移位）。
	 * 延遲原因： 訊號必須**連續穿過 5 個 32-bit MUX**。每一個 MUX 的 Gate Delay 會**線性累加**，形成全模組最長的邏輯鏈（Logic Chain）。

   * 33-bit Add/Sub（加減法器）：次要瓶頸
	 * 邏輯結構： `assign add_sub = {1'b0, a} + {1 me0, b_op} + sub;`
	 * 延遲原因： 高位元（MSB）必須等待低位元（LSB）一路傳遞上來的**進位訊號（Carry Chain）**，需等待 32 個 Full Adder 的傳遞延遲。

   * 位元邏輯運算（AND / OR / XOR）：非瓶頸
	 * 邏輯結構： 32-bit 平行運算。
	 * 延遲原因： 僅需經過 **1 階邏輯門**，無位元間的依賴關係，延遲極短。

2. 流水線（Pipelining）切割策略
   * 為什麼不採用 16-bit / 16-bit 高低位拆分？
   	 * **加法器 Carry 依賴：** 高 16-bit 必須等待低 16-bit 的 Carry Out，橫向拆分無法打破時間依賴。
     * **移位器位元跨界：** 桶型移位器的資料會在 32-bit 空間內跨界移動，拆成高低 16-bit 會破壞移位邏輯。

   * 2-Stage Pipeline 切割方案 (縱向階段切割)
     * Stage 1：Shifter 前 3 階 (b[0]~b[2]: 1, 2, 4 bits 移位) ； 33-bit 加減法運算 (ADD / SUB / SLT 準備)
     * Stage 2：Shifter 後 2 階 (b[3]~b[4]: 8, 16 bits 移位)；SLT 邏輯與 Flag 生成 (Z, N, C, V)

   * 2-Stage Pipeline 切割方案原因
     * 時間延遲的「均等平分」（Timing Balance）
       * 桶型移位器總共有 5 階 MUX 選擇器
       * Stage 1 切前 3 階（1, 2, 4 bits）： 穿過 3 個 MUX。
       * Stage 2 切後 2 階（8, 16 bits）： 穿過 2 個 MUX ＋ 1 個最終輸出的 MUX（多路選擇 case）。
       * 讓 Stage 1 與 Stage 2 的邏輯門延遲（Gate Delay）平分
    
	 * 邏輯跨度與加法器同步
      * 加法器的延遲： 32-bit 的進位鏈（Carry Chain）傳播時間，大約剛好等於 2 ~ 3 個 MUX 的延遲。
      * 在 Stage 1：當移位器做完前 3 階（1, 2, 4 bits）時，33-bit 加法器也剛好算完！
      * 兩大運算單元可以在同一個時脈邊緣（Clock Edge） 一起將結果鎖進 Stage 1 暫存器。
    
	* 簡化 Stage 2 的 SLT 與 Flag 計算
	  * 因為加法器在 Stage 1 已經算完了 add_sub
      * Stage 2 就可以直接利用 Stage 1 留下來的 add / sub 結果來判斷溢位（Overflow）與產生 Flag，不會擠壓到 Stage 2 的時序。  

## 遇到的困難與解決方案：
### 問題：
### 為什麼純組合邏輯的 ALU 需要包一層 wrapper 才能做 STA
* `alu_v1` 沒有 clk，無法建立合法的「暫存器→暫存器」timing path
* Wrapper 額外做輸入暫存器（鎖住 a_in/b_in/op_in）與輸出暫存器（鎖住 res/flag），中間接純組合邏輯的 alu_v1，形成合法同步結構
* alu_v1 core 接的是已鎖存的 a_r/b_r/op_r，不是原始輸入 a_in/b_in/op_in，確保組合邏輯的輸入來源穩定，才能被 STA 正確分析
* clk 需要同時接到輸入暫存器與輸出暫存器兩邊

## 關鍵知識/詞彙：
### Synthesis/STA 路徑 vs 功能模擬路徑
* STA：RTL + XDC → Synthesis/Implementation → Timing Report（WNS/Fmax），input 只是被當成晶片接腳，不需要任何東西驅動，也不需要 testbench
* 模擬：RTL + Testbench（用 reg 主動驅動 input）→ Simulator → 波形/PASS-FAIL，目的是驗證邏輯對不對
* 兩條路徑完全獨立，互不需要

### WNS 與 Fmax 的關係
* Timing Report 不會直接列出 Fmax，只給 WNS，需要自己反推

### FPGA 底層架構：桶型移位器 vs. 加法器延遲觀念
1. 桶型移位器（Barrel Shifter）的延遲觀念
* 底層實現機制： 採用 FPGA 內部的 LUT（Look-Up Table, 查找表） 來實現多路選擇器（MUX）。
* 延遲特性：
	* 串聯加成 (Cascaded)： 32-bit 桶型移位器需要做 5 階判斷（1, 2, 4, 8, 16 bits），等於資料必須連續穿過 5 個 MUX。
 	* 佈線開銷 (Routing Delay)： 每次經過一個 MUX，資料都要走出 LUT、經過 FPGA 的通用內部連線，再進入下一個 MUX。

2. 加法器（32-bit Adder）的延遲觀念
* 底層實現機制： 使用 FPGA 晶片內部硬體預先刻好的「專用高速進位鏈」（Dedicated Carry Chain，如 CARRY4 / CARRY8 模組）。
* 延遲特性：
	* 免走通用佈線： 進位訊號（Carry bit）從 Bit 0 傳到 Bit 31 時，使用的是硬體矽晶圓上專屬的硬化線路，不佔用通用的 LUT 佈線資源。
	* 傳播速度極快： 專用進位鏈傳遞 1 bit 的延遲非常小（僅數十皮秒, picoseconds）。

3. 以常見的 FPGA 製程（如 Xilinx 7-Series）為例，兩者的邏輯延遲量級比較

| 比較項目 | 桶型移位器 (Barrel Shifter) | 32-bit 加法器 (Adder) |
| --- | --- | --- |
| **底層硬體資源** | 通用 LUT (Look-Up Table) + 通用連線 | **專用硬體進位鏈 (Dedicated Carry Chain)** |
| **訊號傳遞路徑** | 5 階 MUX 串聯鏈 (Cascade Chain) | 1 階 LUT 輸入 + 32-bit 硬體進位傳遞 |
| **實體佈線開銷** | 高 (每次跨 MUX 皆需走通用佈線) | 低 (走晶片預先刻好的專用高速通道) |
| **估算延遲時間** | 約 **2.0 ~ 2.5 ns** *(最慢)* | 約 **1.0 ~ 1.2 ns** |
| **相對延遲比例** | **100% (基準 Critical Path)** | **約為移位器的 50% (相當於 2~3 個 MUX)** |

[回目錄](#toc)

---

<a id="m08d03"></a>

## 2026 年 8 月 3 日

## 今日成果探討：
### ALU_V2（pipeline）設計：完成 RTL，共歷經 5 輪修正才達到邏輯正確
* Design sources
```verilog
module alu_v2(
    input clk,
    input rst_n,
    input [31:0]a,
    input [31:0]b,
    input [2:0]op_code,
    output reg[31:0]res,
    output reg[3:0]flag
);

// --- stag1：前半段運算　＋　暫存器（stag1 registers）---

    //構建3個 32bit 暫存器用於 barrel shifter
    //Shamt 選用 b[0] ~ b[2] 判斷移動幾個 bit
    wire [31:0]s1_l, s2_l, s3_l; 
    wire [31:0]s1_r, s2_r, s3_r;
    
    // 構建共用的 33-bit 加減法邏輯（在 case 外面算）
    wire sub;
    wire [31:0]b_op;
    wire [32:0]add_sub;

    assign sub = (op_code == 3'b001); // op_code == 3'b001，執行減法
    assign b_op = b ^ {32{sub}}; // 將 b 逐位元反相
    assign add_sub = {1'b0, a} + {1'b0, b_op} + sub; // ADD: a+b；SUB: a + ~b + 1（2補數，+1 由 sub 提供）
    
    // b[0] ~ b[2] 的 logic_shift_left
    assign s1_l = (b[0]) ? {a[30:0], 1'b0} : a;
    assign s2_l = (b[1]) ? {s1_l[29:0], 2'b00} : s1_l;
    assign s3_l = (b[2]) ? {s2_l[27:0], 4'b0000} : s2_l;
    
    // b[0] ~ b[2] 的 arithmetic_shift_right
    assign s1_r = (b[0]) ? {a[31], a[31:1]} : a;
    assign s2_r = (b[1]) ? {{2{a[31]}}, s1_r[31:2]} : s1_r;
    assign s3_r = (b[2]) ? {{4{a[31]}}, s2_r[31:4]} : s2_r;
    
    // 構建 stage1 -> stage2 中間暫存器
    reg [31:0]a_stg1, b_stg1;
    reg [2:0]op_code_stg1;
    reg [32:0]add_sub_stg1;
    reg [31:0]b_op_stg1;
    reg [31:0]shift_stg_l;
    reg [31:0]shift_stg_r;
    reg [31:0]res_stg1;
    
// 前半段資料 -> stage 1
always@(posedge clk)begin
    if(~rst_n)begin
        a_stg1 <= 0;
        b_stg1 <= 0;
        b_op_stg1 <= 0;
        op_code_stg1 <= 0;
        add_sub_stg1 <= 0;
        shift_stg_l <= 0;
        shift_stg_r <= 0;
        res_stg1 <= 0;
    end
    else begin
        a_stg1 <= a;
        b_stg1 <= b;
        b_op_stg1 <= b_op;
        op_code_stg1 <= op_code;
        
        // Stage 1 行為
        case(op_code)
            3'b000 : add_sub_stg1 <= add_sub; // +、- 法運算結果存儲
            3'b001 : add_sub_stg1 <= add_sub; // +、- 法運算結果存儲
            3'b010 : res_stg1 <= a & b;
            3'b011 : res_stg1 <= a | b;
            3'b100 : res_stg1 <= a ^ b;
            3'b101 : shift_stg_l <= s3_l; // b[0] ~ b[3] 移位結果存儲
            3'b110 : shift_stg_r <= s3_r; // b[0] ~ b[3] 移位結果存儲
            3'b111 : res_stg1 <= ($signed(a) < $signed(b)) ? 32'd1 : 32'd0;
            default : res_stg1 <= 0;
        endcase      
    end   
end
// --- stag1：前半段運算　＋　暫存器（stag1 registers）結束---

// --- stag2：後半段運算　＋　暫存器（stag2 registers）---
    
    //構建2個 32bit 暫存器用於 barrel shifter
    //Shamt 選用 b_stg1[3] ~ b_stg1[4] 判斷移動幾個 bit
    wire [31:0]s4_l, shift_l_res;
    wire [31:0]s4_r, shift_r_res;
    
    // b_stg1[3] ~ b_stg1[4] 的 logic_shift_left
    assign s4_l = (b_stg1[3]) ? {shift_stg_l[23:0], 8'b00000000} : shift_stg_l;
    assign shift_l_res = (b_stg1[4]) ? {s4_l[15:0], 16'b0000000000000000} : s4_l;
    // b_stg1[3] ~ b_stg1[4] 的 arithmetic_shift_right
    assign s4_r = (b_stg1[3]) ? {{8{a_stg1[31]}}, shift_stg_r[31:8]} : shift_stg_r;
    assign shift_r_res = (b_stg1[4]) ? {{16{a_stg1[31]}}, s4_r[31:16]} : s4_r;
    
    // 構建進位與溢位判斷
    wire carry_stg1;
    wire overflow_stg1;
    assign carry_stg1 = add_sub_stg1[32]; //進位判斷 
    assign overflow_stg1 = (~(a_stg1[31] ^ b_op_stg1[31])) && (a_stg1[31] ^ add_sub_stg1[31]); //溢位判斷
    
    // stage 1 -> stage 2（final_res）
    reg [31:0] final_res;
    always @(*) begin
        case(op_code_stg1)
            3'b000 : final_res = add_sub_stg1[31:0];
            3'b001 : final_res = add_sub_stg1[31:0];
            3'b010 : final_res = res_stg1;
            3'b011 : final_res = res_stg1;
            3'b100 : final_res = res_stg1;
            3'b101: final_res = shift_l_res;
            3'b110: final_res = shift_r_res;
            3'b111 : final_res = res_stg1;
            default: final_res = 0;
        endcase
    end
    
// stage 2 -> resault
always@(posedge clk)begin
    if(~rst_n)begin
        res <= 0;
        flag <= 0;
    end
    else begin
        res <= final_res; // 直接用統一選好的值，case 不用重複寫兩次
        // Z/N 對每種運算都更新，C/V 只在 ADD/SUB 才有意義
        flag <= {(final_res == 32'd0), final_res[31],
         ((op_code_stg1==3'b000)||(op_code_stg1==3'b001)) ? carry_stg1    : 1'b0,
         ((op_code_stg1==3'b000)||(op_code_stg1==3'b001)) ? overflow_stg1 : 1'b0};
    end   
end
// --- stag2：後半段運算　＋　暫存器（stag2 registers）結束---   
endmodule
```

## 遇到的困難與解決方案：
### 問題1：Stage1/Stage2 之間資料流沒有真的接起來
* 原因：Stage2 算移位結果時，用的是原始未鎖存的 `b`、`s3_l`、`s3_r`，跟 Stage1 鎖存的 `op_code_stg1`（已延遲一拍）時間點對不上，等於移位運算完全沒被 pipeline 到
* 解法：Stage1 額外做 `shift_stg_l`/`shift_stg_r` 兩個暫存器，把中間移位結果鎖存起來，Stage2 改用鎖存後的值繼續算

### 問題2：case/if 判斷式寫在 always block 的 if(reset)/else 外面，導致 reset 沒有真正生效
* 原因：同一個訊號在 reset 分支跟外層又被賦值一次，最後執行到的那次才生效，蓋掉 reset 設定的值
* 解法：把 case/if 都搬進對應的 else begin...end 裡面

### 問題3：flag 讀到「舊」的 Z/N/C/V 中繼暫存器（非阻塞賦值特性）
* 原因：`<=` 賦值右邊讀到的是這次賦值前的舊值，`flag <= {Z,N,C,V}` 會慢一拍
* 解法：改成直接用當下算出的訊號組合，不繞經中繼暫存器

### 問題4：Stage2 移位控制訊號（b[3] / b[4]）用的仍是原始未鎖存的 b
* 原因：`shift_stg_l`/`shift_stg_r` 是上一拍鎖存的資料，但判斷要不要繼續移的 `b[3]`/`b[4]` 卻是這一拍當下最新的 b，資料跟控制時間點不一致
* 解法：改成 `b_stg1[3]`/`b_stg1[4]`

### 問題5：sub_stg1 沒有被鎖存，b_op_stg1 用當下的 sub 去配鎖存過的 b_stg1
* 原因：控制訊號跟資料時間點不一致，跟問題5是同一類問題
* 解法：Stage1 額外鎖存 `sub_stg1`，Stage2 改用 `b_op_stg1 = b_stg1 ^ {32{sub_stg1}}`

### 問題6：ADD / SUB 的 flag 讀錯來源（反覆出現在第1、2版，第3版才真正解決）
* 原因：ADD/SUB 的真正結果存在 `add_sub_stg1`，但 flag 判斷 Z/N 時卻讀取 `res_stg1`（該次 case 沒有對應分支，值是殘留的舊值），導致 ADD/SUB 的 Z/N flag 完全錯誤
* 解法：在 Stage2 用組合邏輯統一算出 `final_res`（依 op_code_stg1 選出這一拍真正的最終結果，ADD/SUB 選 add_sub_stg1，其餘選對應暫存器），res 跟 flag 的 Z/N 都從 final_res 取值，不再各自各的

### 問題7：flag 只有 ADD / SUB 才更新，其他運算 flag 維持舊值不動
* 原因：整個 flag（含 Z/N）都包在 `if(ADD||SUB)` 裡面才更新，跟 baseline 行為（Z/N 每種運算都要算，只有 C/V 限定 ADD/SUB）不一致
* 解法：拿掉 Z/N 的 if 限制，改成永遠算 Z/N，只有 C/V 用三元運算子限定 ADD/SUB 才給實際值、否則補 0

## 關鍵知識/詞彙：
### Pipeline 設計中「控制訊號要跟資料同一拍」的原則
* 切 pipeline 時，Stage2 用來判斷「怎麼處理某個資料」的控制訊號（例如 op_code、b 的某幾個 bit、sub 這種旗標），一定要用「跟該筆資料同一拍被鎖存」的版本，不能混用「這一拍最新的」控制訊號去配「上一拍鎖存」的資料
* 這是這次 debug 過程中最常出現、也最關鍵的一種錯誤模式，移位邏輯（b[3]/b[4]）跟 overflow 判斷（sub）都各踩到一次

### 非阻塞賦值（<=）讀值的時機
* `<=` 賦值時，右邊讀到的是這次賦值前的舊值，賦值本身要等整個 block 結束才真的生效
* 如果讓 flag 這種輸出訊號繞經中繼暫存器（如 Z/N/C/V）再組合，容易讀到「慢一拍」的舊值，建議直接用當下算出的訊號組合，避免多繞一層

[回目錄](#toc)

---

<a id="m08d04"></a>

## 2026 年 8 月 4 日

## 今日成果探討：
### ALU_V2（pipeline）設計：
1. 完成 Testbench - alu_v2_tt，驗證 pipeline 版本功能，經多輪除錯後全數 PASS
2. 確認延遲精確為 2 個 clock cycle，跟設計預期的 2-stage pipeline 一致，功能上與 baseline（alu_v1）等價

* Simulation sources
  ```verilog
  module alu_v2_tt();
    
    reg clk;
    reg rst_n;
    reg [31:0]a, b;
    reg [2:0]op_code;
    wire [31:0]res;
    wire [3:0]flag;
    integer i;
    
    integer error_count; // 用於計算"error"次數
    integer test_count; // 用於計算"test"次數
    
    alu_v2 tt(
    .clk(clk),
    .rst_n(rst_n),
    .a(a),
    .b(b),
    .op_code(op_code),
    .res(res),
    .flag(flag)
    );
    
    task automatic check(
        input [31:0]t_a, // a的測試變數
        input [31:0]t_b, // b的測試變數
        input [2:0]t_op, // op_code的測試變數
        input [31:0]t_res, // res的測試變數
        input t_z, t_n, t_c, t_v // flag的測試變數
    );
        begin
            a = t_a; b = t_b; op_code = t_op;
            
            @(posedge clk); // 第1拍：鎖進 Stage1
            @(posedge clk); // 第2拍：鎖進 Stage2
            #1; // 確保讀值時 NBA（非阻塞賦值） 已經真正落地
            
            test_count = test_count + 1; // 每次開始測試 test_count 次數 +1
            if(res !== t_res || flag !== {t_z, t_n, t_c, t_v})begin // res 結果或 flag 結果不符
                error_count = error_count + 1; // 錯誤就把 error_count 次數 +1
                $display("[FAIL]：%0d, op_code = %b, a = %h, b = %h | got res = %h, flag = %b | t_res = %h, flag = %b",
                test_count, t_op, t_a, t_b, res, flag, t_res, {t_z, t_n, t_c, t_v});
            end
            else begin
                $display("[PASS]：%0d, op_code = %b", test_count, t_op);
            end
        end
    endtask
    
    initial clk = 0;
    always #5 clk = ~clk;   // 每5ns翻轉一次，週期10ns

    initial begin
        rst_n = 0;
        repeat (2) @(posedge clk);   // 讓 reset 訊號至少過2個clock edge
        rst_n = 1;
        @(posedge clk); // 多留一拍緩衝，讓 reset 解除跟第一筆資料錯開
        
        error_count = 0;
        test_count = 0;
        
        // 基本功能：ADD / SUB 
        check(32'h0000_00F0, 32'h0000_000F, 3'b000, 32'h0000_00FF, 0,0,0,0); // ADD
        check(32'h0000_00F0, 32'h0000_000F, 3'b001, 32'h0000_00E1, 0,0,1,0); // SUB
        
        // 邏輯運算：AND / OR / XOR
        check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b010, 32'h0F00_0F00, 0,0,0,0); // AND
        check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b011, 32'hFF0F_FF0F, 0,1,0,0); // OR
        check(32'hFF00_FF00, 32'h0F0F_0F0F, 3'b100, 32'hF00F_F00F, 0,1,0,0); // XOR
        
        // 針對電路容易出錯的地方各自設計測資
        check(32'hF123_4567, 32'h0000_0004, 3'b110, 32'hFF12_3456, 0,1,0,0); // SRA 符號延伸
        check(32'h7FFF_FFFF, 32'h0000_0001, 3'b000, 32'h8000_0000, 0,1,0,1); // ADD overflow
        check(32'hFFFF_FFFF, 32'h0000_0005, 3'b111, 32'h0000_0001, 0,0,0,0); // SLT：-1 < 5
        check(32'h0000_0001, 32'h0000_0000, 3'b101, 32'h0000_0001, 0,0,0,0); // shamt=0
        check(32'h0000_0001, 32'h0000_001F, 3'b101, 32'h8000_0000, 0,1,0,0); // shamt=31
        
        $display("\n測試完成：共 %0d 組，失敗 %0d 組", test_count, error_count);
        if(error_count == 0)begin
            $display("ALL TESTS PASSED");
        end
        $finish;       
    end  
  ```

* 模擬結果
<img width="213" height="257" alt="image" src="https://github.com/user-attachments/assets/e6e79d99-8720-451a-ae4d-08f9bbb5e3b7" />

## 遇到的困難與解決方案：
### 問題1：clk 沒有持續產生方波
* 原因：只寫了 `#10 clk = ~clk;` 一次，之後沒有任何機制讓 clk 持續振盪，DUT 完全不會觸發
* 解法：改成 `initial clk = 0; always #5 clk = ~clk;` 持續產生週期性方波

### 問題2：check() 沒有等待 clock edge，也沒處理 pipeline 延遲
* 原因：賦值後立刻比對，沒有等任何 posedge clk；alu_v2 是 2-stage pipeline，結果要 2 拍後才會反映到 res/flag
* 解法：在賦值與比對之間加上 `@(posedge clk)` 兩次

### 問題3：reset 沒有撐過完整 clock cycle 就結束
* 原因：`rst_n = 0` 之後沒有等待任何 clock edge 就直接動作
* 解法：用 `repeat(2) @(posedge clk);` 讓 reset 訊號至少過 2 個 clock edge 再解除

### 問題5（花最多輪才找到原因）：加了正確拍數還是持續 FAIL，且結果連續多輪完全相同
* 排查過程：一開始懷疑是 Vivado 沒有重新編譯到最新程式碼（用 Relaunch、Reset Output Products、甚至手動清除 xsim 編譯產物都懷疑過），但檢查 RTL 、改了多次 testbench，數值依然完全相同
* 真正原因：**NBA（非阻塞賦值）取樣時機的競爭條件（race condition）**—— 在 RTL 的 DUT 內 `res <= final_res;` 是非阻塞賦值，實際生效發生在該次 posedge 的 NBA 更新區；但 testbench 裡 `@(posedge clk);` 恢復執行後緊接著的 blocking 讀值敘述，發生時機比 NBA 真正生效還早，讀到的是「這次更新前」的舊值
* 解法：在最後一次 `@(posedge clk);` 之後加上 `#1;`，確保讀值時 NBA 已經真正落地，加上後全數 PASS

## 關鍵知識/詞彙：
### NBA（非阻塞賦值）與讀值時機的競爭條件
* `<=` 賦值在硬體上代表暫存器行為，模擬時的生效時機是在該次事件的 NBA 更新區，晚於同一時間點的 blocking 敘述
* 如果 testbench 在 `@(posedge clk)` 恢復執行後，立刻用 blocking 敘述去讀 DUT 的輸出訊號，有可能讀到「這次 edge 更新前」的舊值，因為讀值時機比 NBA 真正生效還早
* 標準解法：在讀值前多留一個極小延遲（如 `#1`），或改成在 `@(negedge clk)` 讀值，確保 NBA 已經真正落地

### Debug 過程的啟示
* 「結果不對」不一定代表「設計邏輯錯了」，也可能是「觀察／取樣的時機不對」，兩者要分開排查，不要一路只往 RTL 邏輯或環境快取的方向找

[回目錄](#toc)

---

<a id="m08d05"></a>

## 2026 年 8 月 5 日

## 今日成果探討：
### ALU 設計：
### 32bit_ALU_V2（pipeline） - 第一次 Synthesis + Implementation 結果，並記錄收斂到 WNS 接近 0 的結果
* Constraints sources - 1st
```
create_clock -period 20 -name clk [get_ports clk]
```

* Constraints sources - 2nd
```
create_clock -period 6 -name clk [get_ports clk]
```

* Constraints sources - 3rd
```
create_clock -period 5 -name clk [get_ports clk]
```

* Constraints sources - 4th
```
create_clock -period 4.5 -name clk [get_ports clk]
```

* 模擬結果
1. period 20：
   * 反推 Fmax：`(20 - 14.489) = 5.511ns -> Fmax ≈ 1000 / 5.511 ≈ 181.5 MHz`
<img width="1336" height="89" alt="image" src="https://github.com/user-attachments/assets/9c8a5dec-93aa-4fea-8864-44167cd95726" />

2. period 6：
   * 反推 Fmax：`(6 − 1.327) = 4.673ns -> Fmax ≈ 1000 / 4.673 ≈ 214.0 MHz`
<img width="1335" height="89" alt="image" src="https://github.com/user-attachments/assets/5c21149f-dcb8-46ba-be32-c51a4055ca4b" />

3. period 5：
   * 反推 Fmax：`(5 − 0.751) = 4.249ns -> Fmax ≈ 1000 / 4.249 ≈ 235.3 MHz`
<img width="1334" height="88" alt="image" src="https://github.com/user-attachments/assets/a1f26036-345d-4680-9d55-7353304710fe" />

4. period 4.5：
   * 反推 Fmax：`(4.5 − 0.551) = 3.949ns -> Fmax ≈ 1000 / 3.949 ≈ 253.2 MHz`
<img width="1334" height="90" alt="image" src="https://github.com/user-attachments/assets/2dbb2fc8-a190-44de-8fe9-cfb091fc207f" />

### ALU_V2（Pipeline）最終基準線數據
* Period = 4.5 ns, WNS = 0.551 ns
* Fmax ≈ 253.2 MHz
* LUT = 317, FF = 172

### Baseline vs Pipeline 最終對照表

| 項目 | Baseline（alu_v1） | Pipeline（alu_v2, 2-stage） |
|---|---|---|
| Period（收斂值） | 7.2 ns | 4.5 ns |
| WNS | 0.516 ns | 0.551 ns |
| Fmax | ≈ 149.6 MHz | ≈ 253.2 MHz |
| LUT | 327 | 317 |
| FF | 103 | 172 |
| Latency | 1 cycle | 2 cycle |

### 說明
1. Baseline 版本是純組合邏輯，加法器用 Ripple Carry Adder，關鍵路徑是進位一路傳到最高位，限制了整體時脈上限，收斂後 Fmax 約 149.6MHz。
   
2. Pipeline 版本把資料路徑切成 2 個 stage，中間插入暫存器，把原本一次算完的長路徑拆成兩段較短的路徑，收斂後 Fmax 約 253.2MHz，相較 baseline 提升約 1.69 倍。
   
3. trade-off ：
   * 用「面積換取速度」換來的：FF 用量從 103 增加到 172（多了約 69 顆暫存器，用於 Stage1/Stage2 之間鎖存中繼資料）
   * LUT 用量反而略降（327→317），代表邏輯本身沒有變複雜，資源增加主要來自新增的暫存器，不是額外的運算邏輯。
   * Latency 則從 1 cycle 增加為 2 cycle
   * 犧牲單筆資料的延遲，換取整體吞吐量（throughput）與可運作頻率的提升。

4. 兩個版本的功能都用同一組 testbench 驗證過，結果完全等價，確保這組時序數據的比較是建立在功能正確、公平的基準。

## 未來優化方向（依 Timing Report 的 Net/Logic Delay 比例修正）
1. Timing Report
<img width="1062" height="387" alt="image" src="https://github.com/user-attachments/assets/6beb2c5e-173a-4285-907e-b0ef765f42f5" />

* Worst Path 前幾名的 Net Delay 都明顯大於 Logic Delay（例如 Path1: Logic=1.202ns, Net=2.611ns），且 High Fanout 高達16~32
* 代表瓶頸主要來自控制訊號（op_code_stg1、b_stg1[4]）扇出過大造成的繞線延遲

2. 優化方向：降低高扇出控制訊號的負載，而非搬動運算邏輯
* op_code_stg1 要同時驅動 Stage2 裡的移位選擇、final_res 的 8-way mux、flag 邏輯，扇出大
* 可以考慮的做法：
  * 在 Stage1 鎖存後，提早把 op_code_stg1 解碼成 one-hot 控制訊號，讓每條下游邏輯只接自己需要的那一條 select 線，而不是所有邏輯都共用同一組 3-bit bus，降低單一訊號的扇出數
  * 對高扇出訊號下 MAX_FANOUT 屬性限制，讓 Vivado 在 synthesis 階段主動做訊號複製（從 `res_reg[31]_lopt_replica` 這個命名可以看出，Vivado 已自動幫 res_reg[31] 做過一次複製優化，代表工具本身也判斷這是扇出問題，可以再手動加強）
* 優化不能只停留在架構設計，實際的 layout/繞線行為也會回頭影響該怎麼調整 RTL

## 關鍵知識/詞彙：
### 降低扇出的兩種做法
1. **提早解碼成 one-hot**：把一個多用途、被到處讀取的訊號（例如 op_code），提前轉換成多條各自獨立、各自代表單一意義的線（is_add、is_sub...），讓下游邏輯各自只接自己需要的那一條，分散單一訊號的驅動負擔，屬於 RTL 設計面的優化
2. **MAX_FANOUT 屬性**：透過 XDC 對特定訊號下扇出限制的約束，讓 Vivado 自動把超過門檻的訊號複製成多份分擔負擔，屬於工具層面的輔助手段，不需要更動 RTL 邏輯

### 為何產生_replica 
<img width="328" height="58" alt="image" src="https://github.com/user-attachments/assets/ce8cfae4-3dcd-429b-a2a8-a684708bfdd5" />

* Vivado 有時會自動判斷扇出過大並主動做訊號複製，產生類似 `_replica` 命名的訊號，代表工具本身已經在處理這類問題，可以透過約束加強這個機制

### Timing Report 的 Logic Delay vs Net Delay
* Logic Delay：訊號經過邏輯閘本身運算所花的時間
* Net Delay：訊號在實體接線上傳遞所花的時間（受扇出、繞線距離影響）
* 兩者比例可以幫助判斷關鍵路徑慢的根本原因：Logic Delay 高代表邏輯層數太深，Net Delay 高代表扇出/繞線是瓶頸，優化方向會完全不同

[回目錄](#toc)

---
<a id="m08d10"></a>

## 2026 年 8 月 10 日

## 今日進度：
### 資料：
1. Digital Design and Computer Architecture (ARM / RISC-V Edition) - ALU 管道化（Pipelining）、組合邏輯收斂與資源共享（Resource Sharing）、One-Hot State/Decoder 編碼優化。
2. Advanced ASIC Chip Synthesis: Using Synopsys® Design Compiler® Physical Compiler® and PrimeTime® - High Fanout 訊號對物理佈線（Routing）的寄生電容效應、Net Delay vs. Logic Delay 的消長關係、Timing Closure 調校策略。
3. Verilog HDL: A Guide to Digital Design and Synthesis - always @(*) 組合邏輯與推導 Flip-Flop（Clock Enable / Latch 避免）的 RTL 最佳撰寫範本。
4. AMD / Xilinx Vivado Design Suite User Guide: Design Analysis and Closure Techniques (UG906) - Section: High Fanout Net Optimization / Timing Report Analysis
5. AMD / Xilinx Vivado Design Suite User Guide: Synthesis (UG901) - Synthesis Attributes: max_fanout & Resource Sharing
6. Intel (Altera) Quartus Prime Standard Edition Handbook Volume 2: Design Implementation and Optimization - Section: Duplicate Registers for Fanout Control


## 關鍵知識/詞彙：
### FPGA/ASIC 硬體設計與 Timing Closure 優化指南

### 扇出（Fanout）與其影響
* **扇出 (Fanout)**：指單一輸出訊號（如暫存器 Q 端或邏輯閘輸出）所驅動的**下游輸入端（Loads）總數量**。
* **物理影響**：
  * **電容效應 (Capacitance)**：驅動的負載越多，金屬線路的總寄生電容越大，訊號充放電變慢（Slew Rate 惡化）。
  * **長途佈線 (Routing Distance)**：訊號需要透過 FPGA 的 Interconnect 金屬線拉去晶片上多個分散的角落。
* **現象**：Timing Report 中呈現 **$\text{Net Delay} \gg \text{Logic Delay}$**（佈線延遲遠大於邏輯延遲）。

### 降低扇出（High Fanout）的核心做法

* 解決高扇出問題通常從 **「RTL 架構設計面」** 與 **「EDA 工具約束面」** 兩大維度切入：

1. 方案一：RTL 設計面 — 提早解碼 / 集中收斂 (Architecture Optimization)

* **概念**：將原本多用途、多位元的編碼訊號（如 3-bit `op_code`），由「末端被動詢問」改為「源頭一次解完/集中收斂」。
* **優化方式**：
  1. **One-Hot 解碼**：在源頭將訊號轉換為獨立專線（`is_add`, `is_sub`），讓各子模組只接收專屬控制線，分散負載。
  2. **組合邏輯收斂 (Multiplexing)**：在進入下一級 DFF 前，透過 `always @(*)` 的 MUX 先將各模組算好的結果收斂成單一匯流排（如 `final_res`）。
* **優點**：
  * **大幅降低扇出**：控制訊號負載從 $N$ 降至個位數。
  * **資源共享 (Resource Sharing)**：避免 EDA 工具合成出多套重複的大型 MUX，顯著**節省 LUT 資源**。
  * **消除 Enable 腳位**：避免合成出帶有 Clock Enable (CE) 的多餘 Flip-Flop 控制線。

2. 方案二：工具約束面 — `MAX_FANOUT` 屬性 (Implementation Optimization)

* **概念**：不更動 RTL 邏輯，透過 XDC 約束或 RTL 屬性指示合成工具（如 Vivado）自動進行 **暫存器複製（Register Duplication）**。
* **運作機制**：
  ```text
  [原本] Reg_A ─────────────────► 負載 1 ~ 100 (Fanout = 100, Net Delay 爆表)

  [複製後] Reg_A_1 ─────────────► 負載 1 ~ 50  (Fanout = 50)
           Reg_A_2 (Replica) ───► 負載 51 ~ 100 (Fanout = 50)
  ```
* 範例程式：
	* Verilog RTL 屬性
 	```
  	(* max_fanout = 16 *) reg [2:0] op_code_stg1;
  	``` 

   * XDC 約束檔
	```
     set_property MAX_FANOUT 16 [get_nets op_code_stg1_reg[*]]
    ```
  

[回目錄](#toc)

---
<a id="m08d11"></a>

## 2026 年 8 月 11 日

## 今日成果探討：
### ALU 設計優化：
### 32bit_ALU_V2（pipeline） - 主動重構，把邏輯運算與 SLT 先獨立拆成一個組合邏輯，Stage1 暫存器改成**每拍無條件更新**：

* 程式碼
```verilog
`timescale 1ns / 1ps
//////////////////////////////////////////////////////////////////////////////////
// Company: 
// Engineer: 
// 
// Create Date: 2026/08/03 10:00:47
// Design Name: 
// Module Name: alu_v2
// Project Name: 
// Target Devices: 
// Tool Versions: 
// Description: 
// 
// Dependencies: 
// 
// Revision:
// Revision 0.01 - File Created
// Additional Comments:
// 
//////////////////////////////////////////////////////////////////////////////////


module alu_v2(
    input clk,
    input rst_n,
    input [31:0]a,
    input [31:0]b,
    input [2:0]op_code,
    output reg[31:0]res,
    output reg[3:0]flag
);

// --- stag1：前半段運算　＋　暫存器（stag1 registers）---

    //構建3個 32bit 暫存器用於 barrel shifter
    //Shamt 選用 b[0] ~ b[2] 判斷移動幾個 bit
    wire [31:0]s1_l, s2_l, s3_l; 
    wire [31:0]s1_r, s2_r, s3_r;
    
    // 構建共用的 33-bit 加減法邏輯（在 case 外面算）
    wire sub;
    wire [31:0]b_op;
    wire [32:0]add_sub;

    assign sub = (op_code == 3'b001); // op_code == 3'b001，執行減法
    assign b_op = b ^ {32{sub}}; // 將 b 逐位元反相
    assign add_sub = {1'b0, a} + {1'b0, b_op} + sub; // ADD: a+b；SUB: a + ~b + 1（2補數，+1 由 sub 提供）
    
    // b[0] ~ b[2] 的 logic_shift_left
    assign s1_l = (b[0]) ? {a[30:0], 1'b0} : a;
    assign s2_l = (b[1]) ? {s1_l[29:0], 2'b00} : s1_l;
    assign s3_l = (b[2]) ? {s2_l[27:0], 4'b0000} : s2_l;
    
    // b[0] ~ b[2] 的 arithmetic_shift_right
    assign s1_r = (b[0]) ? {a[31], a[31:1]} : a;
    assign s2_r = (b[1]) ? {{2{a[31]}}, s1_r[31:2]} : s1_r;
    assign s3_r = (b[2]) ? {{4{a[31]}}, s2_r[31:4]} : s2_r;
    
    // 構建 stage1 -> stage2 中間暫存器
    reg [31:0]a_stg1, b_stg1;
    reg [2:0]op_code_stg1;
    reg [32:0]add_sub_stg1;
    reg [31:0]b_op_stg1;
    reg [31:0]shift_stg_l;
    reg [31:0]shift_stg_r;
    reg [31:0]res_stg1;
    
    
    reg [31:0]res_com1;
    always@(*)begin
        case(op_code)
            3'b010 : res_com1 = a & b;
            3'b011 : res_com1 = a | b;
            3'b100 : res_com1 = a ^ b;
            3'b111 : res_com1 = ($signed(a) < $signed(b)) ? 32'd1 : 32'd0;
            default : res_com1 = 0;
        endcase
    end
    
    
    // 前半段資料 -> stage 1
    always@(posedge clk)begin
        if(~rst_n)begin
            a_stg1 <= 0;
            b_stg1 <= 0;
            b_op_stg1 <= 0;
            op_code_stg1 <= 0;
            add_sub_stg1 <= 0;
            shift_stg_l <= 0;
            shift_stg_r <= 0;
            res_stg1 <= 0;
        end
        else begin
            a_stg1 <= a;
            b_stg1 <= b;
            b_op_stg1 <= b_op;
            op_code_stg1 <= op_code;
 
            add_sub_stg1 <= add_sub; // +、- 法運算結果存儲
            shift_stg_l <= s3_l; // b[0] ~ b[3] 移位結果存儲
            shift_stg_r <= s3_r; // b[0] ~ b[3] 移位結果存儲
            
            res_stg1 <= res_com1;     
        end   
    end
    // --- stag1：前半段運算　＋　暫存器（stag1 registers）結束---

    // --- stag2：後半段運算　＋　暫存器（stag2 registers）---
    
    //構建2個 32bit 暫存器用於 barrel shifter
    //Shamt 選用 b_stg1[3] ~ b_stg1[4] 判斷移動幾個 bit
    wire [31:0]s4_l, shift_l_res;
    wire [31:0]s4_r, shift_r_res;
    
    // b_stg1[3] ~ b_stg1[4] 的 logic_shift_left
    assign s4_l = (b_stg1[3]) ? {shift_stg_l[23:0], 8'b00000000} : shift_stg_l;
    assign shift_l_res = (b_stg1[4]) ? {s4_l[15:0], 16'b0000000000000000} : s4_l;
    // b_stg1[3] ~ b_stg1[4] 的 arithmetic_shift_right
    assign s4_r = (b_stg1[3]) ? {{8{a_stg1[31]}}, shift_stg_r[31:8]} : shift_stg_r;
    assign shift_r_res = (b_stg1[4]) ? {{16{a_stg1[31]}}, s4_r[31:16]} : s4_r;
    
    // 構建進位與溢位判斷
    wire carry_stg1;
    wire overflow_stg1;
    assign carry_stg1 = add_sub_stg1[32]; //進位判斷 
    assign overflow_stg1 = (~(a_stg1[31] ^ b_op_stg1[31])) && (a_stg1[31] ^ add_sub_stg1[31]); //溢位判斷
    
    // stage 1 -> stage 2（final_res）
    reg [31:0] final_res;
    always @(*) begin
        case(op_code_stg1)
            3'b000 : final_res = add_sub_stg1[31:0];
            3'b001 : final_res = add_sub_stg1[31:0];
            3'b010 : final_res = res_stg1;
            3'b011 : final_res = res_stg1;
            3'b100 : final_res = res_stg1;
            3'b101: final_res = shift_l_res;
            3'b110: final_res = shift_r_res;
            3'b111 : final_res = res_stg1;
            default: final_res = 0;
        endcase
    end
    
    // stage 2 -> resault
    always@(posedge clk)begin
        if(~rst_n)begin
            res <= 0;
            flag <= 0;
        end
        else begin
            res <= final_res; // 直接用統一選好的值，case 不用重複寫兩次
            // Z/N 對每種運算都更新，C/V 只在 ADD/SUB 才有意義
            flag <= {(final_res == 32'd0), final_res[31],
             ((op_code_stg1==3'b000)||(op_code_stg1==3'b001)) ? carry_stg1    : 1'b0,
             ((op_code_stg1==3'b000)||(op_code_stg1==3'b001)) ? overflow_stg1 : 1'b0};
        end   
    end
    // --- stag2：後半段運算　＋　暫存器（stag2 registers）結束---   
    
endmodule	
```

* 模擬結果
<img width="287" height="309" alt="image" src="https://github.com/user-attachments/assets/640080aa-90f9-4679-a364-16d5d0bfe988" />
<img width="1901" height="105" alt="image" src="https://github.com/user-attachments/assets/57a03d44-5b31-4280-8c29-92d10fc70e0e" />
<img width="1645" height="390" alt="image" src="https://github.com/user-attachments/assets/35c5b00a-2fd0-4700-b99a-9d226f4368c4" />

### ALU_V2（Pipeline）基準線數據
* Period = 4.5 ns, WNS = 0.473 ns
* Fmax ≈ (4.5-0.473)=4.027ns → Fmax≈248.3MHz MHz
* LUT = 392, FF = 171

* 效果：四個暫存器每拍都拿到組合邏輯即時算出的新鮮值，徹底排除「case 分支沒列到、讀到殘留舊值」這類問題，也避免被合成器推斷成帶 load-enable 的非預期結構；Stage2 仍靠 `op_code_stg1` 從 `final_res` 正確挑選來源，功能不受影響
* Trade-off：每拍所有暫存器都會翻動（即使跟當拍運算無關），會多耗一點動態功耗，是刻意的簡潔度/穩定度換功耗的設計取捨


## 關鍵知識/詞彙
### 下階段優化考量
1. PPA / 暫存器面積優化：精簡 Stage 1 至 Stage 2 跨級暫存器

* **原設計瓶頸 (Baseline Bottleneck)：**
  觀察 Stage 2 邏輯發現，跨級暫存器存在大量的無效鎖存（Redundant Latching）：
  * `a_stg1` (32-bit)：在 Stage 2 僅用於最高位元 `a_stg1[31]`（算術右移 Sign bit 與溢位 $V$ 判斷）。
  * `b_stg1` (32-bit)：在 Stage 2 僅用於 `b_stg1[4:3]`（Barrel Shifter 後兩階移位）。

* **優化策略 (Optimization Strategy)：**
  取消完整 32-bit 暫存器的宣告，改為僅精準鎖存所需的關鍵位元：
  * `a_sign_stg1` (1-bit) $\leftarrow$ `a[31]`
  * `shamt_stg2` (2-bit) $\leftarrow$ `b[4:3]`

* **改善效益 (Benefits)：**
  在 RTL 層級直接**削減 61 個 Flip-Flops (FF)**。雖然 EDA 工具（如 Vivado Synthesis）具備 Register Pruning 機制，但由設計者在 RTL 主動精確宣告，能確保硬體架構的確定性並降低邏輯合成風險。

2. 邏輯運算單元優化：SLT (Set Less Than) 共享加減法器結果

* **原設計瓶頸 (Baseline Bottleneck)：**
  在 Stage 1 中使用 `$signed(a) < $signed(b)` 進行有號數比較，會導致綜合工具（Synthesis Tool）額外合成出一組獨立的 32-bit 符號比較器（Signed Comparator），增加不必要的晶片面積與 Critical Path 延遲。

* **優化策略 (Optimization Strategy)：**
  利用補數算術邏輯，有號數比較 $A < B$ 在數學上完全等同於判斷 $A - B$ 結果的**負號（Sign Bit, $S_{31}$）與溢位（Overflow, $V$）**。SLT 運算可直接移至 Stage 2，共享加減法器的運算結果：

  $$\text{SLT} = S_{31} \oplus V$$

* **改善效益 (Benefits)：**
  直接**省去 Stage 1 一組 32-bit 比較器**的硬體邏輯閘與連線延遲，有效減輕 Stage 1 的組合邏輯負載並提升時脈頻率（$F_{max}$）。


### SLT (Set Less Than) 邏輯運算與硬體實現原理

* 在 2 補數算術邏輯單元（ALU）中，有號數大小比較 $A < B$（即 SLT 指令）可直接共享加減法器的運算結果，透過 **減法結果符號位元（Sign Bit, $S_{31}$）** 與 **溢位旗標（Overflow Flag, $V$）** 的 XOR 運算精準導出：

	* $$ \text{SLT} = S_{31} \oplus V $$
	* 其中：
		* $S_{31}$：減法運算結果的最高位元（`add_sub_stg1[31]`）
		* $V$：減法運算溢位旗標（`overflow_stg1`）
---

1. 判斷原理 (Core Principle)

判斷 $A < B$ 在計算機中等同於評估減法 $D = A - B$ 的結果是否為負數（$D < 0$）。

符號位元 $S_{31}$ 是否能正確反映結果的正負，取決於運算過程是否產生**溢位（Overflow）**：

### A. 無溢位發生 ($V = 0$)
減法結果落在 32-bit 有號數表示範圍內，$S_{31}$ 能真實代表運算結果的正負號：
* **$S_{31} = 1$**：代表 $A - B < 0 \implies A < B$，即 $\text{SLT} = 1$。
* **$S_{31} = 0$**：代表 $A - B \ge 0 \implies A \ge B$，即 $\text{SLT} = 0$。

> **邏輯公式：** $\text{SLT} = S_{31} \oplus 0 = S_{31}$

### B. 發生溢位 ($V = 1$)
溢位僅會發生於「異號相減」（正數減負數或負數減正數）。當 $V = 1$ 時，說明運算結果已超出 32-bit 表示極限，導致 $S_{31}$ 發生位元反轉（錯誤的符號），必須透過 XOR $V$ 修正：

* **狀況一：正數減負數 ($A \ge 0, B < 0$)**
  * **數學本質：** $A$ 必定大於 $B$，因此 $A < B$ 應為 **假 ($0$)**。
  * **硬體現象：** $A - B$ 正數數值過大產生**上溢（Overflow）**，導致 $S_{31} = 1$（錯誤地呈現負號）。
  * **XOR 校正：** $S_{31} \oplus V = 1 \oplus 1 = \mathbf{0}$ （成功修正為正確的 $0$）。

* **狀況二：負數減正數 ($A < 0, B \ge 0$)**
  * **數學本質：** $A$ 必定小於 $B$，因此 $A < B$ 應為 **真 ($1$)**。
  * **硬體現象：** $A - B$ 負數數值過小產生**下溢（Underflow）**，導致 $S_{31} = 0$（錯誤地呈現正號）。
  * **XOR 校正：** $S_{31} \oplus V = 0 \oplus 1 = \mathbf{1}$ （成功修正為正確的 $1$）。

2. 真值表總結 (Truth Table)

| 溢位旗標 ($V$) | 符號位元 ($S_{31}$) | 硬體實際產生的現象 | 數學真實狀況 | $\text{SLT} = S_{31} \oplus V$ |
| :---: | :---: | :--- | :--- | :---: |
| **0** | **0** | 無溢位，結果為正數或 0 | $A \ge B$ | **0** |
| **0** | **1** | 無溢位，結果為負數 | $A < B$ | **1** |
| **1** | **0** | 負減正發生下溢，結果被拉回正數 | $A < B$ | **1** |
| **1** | **1** | 正減負發生上溢，結果被拉回負數 | $A \ge B$ | **0** |
---

## 3. 硬體效益 (Hardware Benefit)

* 利用 $S_{31} \oplus V$：
1. **面積優化：** 僅需額外增加一個 **2-input XOR 邏輯閘**，無需合成複雜的 32-bit 專用符號比較器（Signed Comparator）。
2. **時序優化：** 完全共享加減法器（Adder/Subtractor）的運算路徑，大幅節省晶片面積並優化關鍵路徑（Critical Path）延遲。

[回目錄](#toc)

---
<a id="m08d12"></a>

## 2026 年 8 月 12 日

## 今日進度：
### 刷題：複習 HDLBits 7/3 - 8/11 進度；完成 HDLBits 的 Shift Registers。

## 遇到的困難與解決方案：
### Exams/2014 q4b
<img width="1214" height="844" alt="image" src="https://github.com/user-attachments/assets/351e30f6-f364-4a48-b2a9-2a7d25b969ca" />

1. 問題：
* **多重驅動衝突 (Multiple Drivers Error)**：
   * 在 `top_module` 中同時使用子模組 (`MUXDFF inst0(...)`) 與 `always @(posedge clk)` 區塊對相同的輸出埠 (`LEDR`) 進行指派。
   * **硬體觀念**：在數位電路中，一根導線 (Wire) 不能同時被兩個邏輯閘的輸出端驅動，否則會造成訊號衝突（短路/未知態 `X`）。
* **架構分工模糊 (Lack of Separation of Concerns)**：
   * 忽視了 `MUXDFF` 內部應包含 MUX 多路選擇器邏輯，導致頂層模組既做腳位串接又做邏輯判斷，失去模組化的意義。

2. 程式
```verilog
  	module top_module (
    input [3:0] SW,
    input [3:0] KEY,
    output [3:0] LEDR
); 
    
    
    MUXDFF inst0(
        .clk(KEY[0]),
        .q(LEDR[0])
    );
    MUXDFF inst1(
        .clk(KEY[0]),
        .q(LEDR[1])
    );
    MUXDFF inst2(
        .clk(KEY[0]),
        .q(LEDR[2])
    );
    MUXDFF inst3(
        .clk(KEY[0]),
        .q(LEDR[3])
    );
    
    always@(posedge KEY[0])begin
        case({KEY[1], KEY[2]})
            2'b00 : LEDR <= LEDR;
            2'b01 : LEDR <= SW;
            2'b10 : LEDR <= KEY[3];
            2'b11 : LEDR <= SW;
        endcase
    end

endmodule

module MUXDFF(
    input clk,
    input d,
    output q
);
    
    always@(posedge clk)begin
    	q <= d;
    end

endmodule
```

### Exams/ece241 2013 q12
<img width="1213" height="613" alt="image" src="https://github.com/user-attachments/assets/4888ad9d-2d7a-45af-9a8d-c95ea2f529e3" />

1. 問題：
* **多重驅動衝突 (Multiple Drivers Error)**：
   * 在頂層模組中同時實體化了 8 個 `dff8` (`inst0` ~ `inst7`)，且每一個子模組都將其 `Z` 腳位連接到頂層的 `output Z`。
   * **硬體觀念**：多個輸出端同時驅動同一根導線會造成訊號衝突（短路 / 未知態 `X`）。
     
* **時序與組合邏輯混淆 (Sequential vs. Combinational Misunderstanding)**：
   * 原設計將讀取選擇器（`case({A, B, C})`）寫在 `always @(posedge clk)` 的 `else` 分支內。
   * **問題所在**：
     * 當 `enable = 1`（進行移位寫入）時，`else` 不會執行，導致 `Z` **無法更新**。
     * LUT / RAM 的讀取動作（Random Access）本質上是 **組合邏輯 (Multiplexer)**，應該隨時反映 `{A, B, C}` 的位址變化，而不應該等待 `clk` 上升觸發或受 `enable` 控制。

2. 程式
```verilog
  	module top_module (
    input clk,
    input enable,
    input S,
    input A, B, C,
    output Z ); 
    
    dff8 inst0(
        .clk(clk),
        .enable(enable),
        .d(S),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst1(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst2(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst3(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst4(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst5(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst6(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    dff8 inst7(
        .clk(clk),
        .enable(enable),
        .A(A),
        .B(B),
        .C(C),
        .Z(Z) 
    );
    
    
endmodule

module dff8(
    input clk,
    input enable,
    input d,
    input A, B, C,
    output Z,
    output [7:0]q
);
    
    always@(posedge clk)begin
        if(enable)begin
            q[0] <= d;
            q[1] <= q[0];
            q[2] <= q[1];
            q[3] <= q[2];
            q[4] <= q[3];
            q[5] <= q[4];
            q[6] <= q[5];
            q[7] <= q[6];
        end
        else begin
            case({A, B, C})
                3'b000 : Z <= q[0];
                3'b001 : Z <= q[1];
                3'b010 : Z <= q[2];
                3'b011 : Z <= q[3];
                3'b100 : Z <= q[4];
                3'b101 : Z <= q[5];
                3'b110 : Z <= q[6];
                3'b111 : Z <= q[7];
            endcase
        end
    end
    
endmodule
```


### 解法：
### Exams/2014 q4b
1. **頂層模組 (`top_module`)**：專注於硬體連線 (Wiring/Instantiation)，**完全移除 `always` 區塊**，避免重複驅動 `LEDR`。
2. **子模組 (`MUXDFF`)**：將 MUX 選擇邏輯（`L` 判斷是載入 `R` 還是移位 `w`）與 D-Flip-Flop 包裹在子模組內部。

3. 程式碼
  ```verilog
  module top_module (
    input [3:0] SW,
    input [3:0] KEY,
    output [3:0] LEDR
	); //
    
	    MUXDFF inst0(
	        .clk(KEY[0]),
	        .E(KEY[1]),
	        .L(KEY[2]),
	        .w(LEDR[1]),
	        .R(SW[0]),
	        .q(LEDR[0])
	    );
	    
	    MUXDFF inst1(
	        .clk(KEY[0]),
	        .E(KEY[1]),
	        .L(KEY[2]),
	        .w(LEDR[2]),
	        .R(SW[1]),
	        .q(LEDR[1])
	    );
	    
	    MUXDFF inst2(
	        .clk(KEY[0]),
	        .E(KEY[1]),
	        .L(KEY[2]),
	        .w(LEDR[3]),
	        .R(SW[2]),
	        .q(LEDR[2])
	    );
	    
	    MUXDFF inst3(
	        .clk(KEY[0]),
	        .E(KEY[1]),
	        .L(KEY[2]),
	        .w(KEY[3]),
	        .R(SW[3]),
	        .q(LEDR[3])
	    );
	
	endmodule
	module MUXDFF (
    input clk,
    input w, E, L, R,
    output q
	);
    
    	always@(posedge clk)begin
        	case({E, L})
        		2'b00 : q <= q;
            	2'b01 : q <= R;
            	2'b10 : q <= w;
            	2'b11 : q <= R;
        	endcase
    	end

	endmodule
  ```

### Exams/ece241 2013 q12
1. **無需拆分 8 個子模組**：`top_module` 本身即包含一個 8-bit 的移位暫存器 (`reg [7:0] q`)。
2. **寫入邏輯（時序邏輯）**：當 `enable = 1` 時，在 `posedge clk` 將 `S` 移入 `q[0]`。
3. **讀取邏輯（組合邏輯）**：直接利用動態索引 `assign Z = q[{A, B, C}];` 實作 8-to-1 MUX，確保讀取獨立且無延遲。

5. 程式碼
  ```verilog
  module top_module (
    input clk,
    input enable,
    input S,
    input A, B, C,
    output Z
);

    reg [7:0] q;

    // 寫入部分：當 enable=1 時，進行 8-bit 移位 (Sequential Logic)
    always @(posedge clk) begin
        if (enable) begin
            // S 輸入給 Q[0]，其他位元向高位移（Q[0]->Q[1]->...->Q[7]）
            q <= {q[6:0], S}; 
        end
    end

    // 讀取部分：以 {A, B, C} 作為位址選出對應的 Q[i] (Combinational Logic)
    assign Z = q[{A, B, C}];

endmodule
  ```

## 關鍵知識/詞彙：
### 移位暫存器與 LFSR (Linear-Feedback Shift Register)

1. 核心觀念
* **Fibonacci vs. Galois 架構**：
  * **Fibonacci 型**：多個 Taps 經過多層 XOR 再回授至輸入端，組合邏輯延遲較高。
  * **Galois 型**：回授訊號（通常為 `q[0]`）直接拉出，並行插入到各 Tap 之間的 XOR 閘，**關鍵路徑僅經過 1 個 XOR 閘**，更易達到 Timing Closure。
* **位元運算技巧**：
  * **右移與回授**：`q <= {q[0], q[31:1]}` 實現了「將最高位填入回授 `q[0]`」與「其餘位元右移一階」。
  * **特定 Tap 更新**：在非阻塞指派 (`<=`) 下，可直接用 `q[tap] <= q[tap+1] ^ q[0];` 覆蓋特定位置。

2. 常見踩雷點
* **狀態鎖死 (Lockup)**：以 XOR 為基礎的 LFSR **絕對不能初始化為全 0**（全 0 經過 XOR 結果永遠為 0），重置時必須載入非零 Seed（如 `5'h1`）。
* **陣列越界 (Out of Bounds)**：使用 `for` 迴圈處理位元時，務必注意 0-based 索引（如 32-bit 的最高位為 `q[31]`，而非 `q[32]`）。

---

### 模組化設計與訊號驅動規則 (Submodules & Drivers)

1. 核心觀念
* **職責分離 (Separation of Concerns)**：
  * **子模組 (Submodule)**：專注於組合與時序邏輯運算（如包含 MUX + DFF）。
  * **頂層模組 (Top Module)**：專注於硬體結構串接 (Structural Modeling)，**儘量避免在頂層使用 `always` 區塊與子模組同時操作同一訊號**。

2. 常見踩雷點
* **多重驅動衝突 (Multiple Drivers Error)**：
  * **現象**：同一訊號（如 `LEDR` 或 `Z`）同時被 `always` 區塊與子模組（`inst0`）驅動，或是多個子模組輸出接到同一導線。
  * **硬體本質**：多個邏輯閘輸出直接短路，導致未知態 (`X`)。
* **`reg` 與 `wire` 宣告混淆**：
  * 在 `always` 區塊內指派的變數（如 `q <= d;`），其埠型態必須明確宣告為 **`output reg`**。

---

### 時序與組合邏輯的邊界 (Sequential vs. Combinational)

1. 核心觀念
* ** Look-Up Table (3-LUT / RAM) 設計**：
  * **寫入 (Write)**：屬於**時序邏輯 (Sequential Logic)**，需受時脈 `clk` 與 `enable` 控制（如 `q <= {q[6:0], S};`）。
  * **讀取 (Read)**：屬於**組合邏輯 (Combinational Logic)**，本質為 Multiplexer (MUX)，應獨立於 `clk` 與 `enable`，隨時反映位址輸入（如 `assign Z = q[{A, B, C}];`）。

2. 最佳實踐 (Best Practices)
* **動態索引即 MUX**：在 Verilog 中使用 `q[index]` 可以極簡且精確地被合成器轉譯為多路選擇器 (MUX)，無需撰寫冗長的 `case` 敘述。
* **拼接運算符 `{}`**：優先使用 `{}` 進行位元拼接與移位（如 `{q[6:0], S}`），比編寫 `for` 迴圈更具可讀性且不容易出現語法錯誤。


[回目錄](#toc)

---
<a id="m08d13"></a>

## 2026 年 8 月 13 日

## 今日進度：
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L1 - L2](https://www.youtube.com/watch?v=ubhxKNlOlRg&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3)


## 關鍵知識/詞彙：
### 計算機系統抽象層級 (Layers of Abstraction)
<img width="438" height="585" alt="image" src="https://github.com/user-attachments/assets/891d39eb-f677-4c41-b5dd-72b94c6918f2" />

| 層級 | 英文名稱 | 範例與說明 |
| :--- | :--- | :--- |
| 頂層 | Problem | 實際欲解決的問題（如：AI 圖像識別） |
| | Algorithm | 解決問題的演算法（如：Quick Sort, CNN） |
| | Program/Language | 高階程式語言（如：C++, Python, Java） |
| | System Software | 作業系統、編譯器、組譯器（OS, Compilers） |
| 中介 | SW/HW Interface | 指令集架構 (ISA)：如 x86, ARM, RISC-V |
| | Micro-architecture | 處理器內部硬體實現（如：流水線、快取設計） |
| | Logic | 數位邏輯閘與電路（如：AND/OR/NAND、暫存器） |
| | Devices | 半導體元件（如：晶體管 Transistors, MOSFET） |
| 底層 | Electrons | 物理層與電子運動 |

* 關鍵概念：SW/HW Interface (ISA)：
	* 軟硬體的橋樑：介於系統軟體與底層硬體之間，是兩者溝通的標準協定。
	* 抽象化契約：定義了機器看得懂的指令集、暫存器（Registers）、記憶體定址模式與資料型態。軟體開發者只需針對 ISA 寫作/編譯，無需關心硬體底層電路的具體實現。
---
### 當前計算機架構的挑戰 (Computer Architecture Today)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/92e0b2df-2d4a-4565-b9f7-0299f55773fd" />

* 現代計算機架構正經歷重大範式轉移（Paradigm Shift），主要推動因素與面對的難題如下：
	* 巨量數據需求 (Data Hunger)：AI 與數據密集型應用的快速崛起。
	* 功耗/散熱限制 (Power Constraints)：功耗牆限制了單核頻率的無限制提升。
	* 設計複雜度 (Design Complexity)：晶片規模與驗證難度大幅增加。
	* 技術微縮困難 (Technology Scaling)：摩爾定律（Moore's Law）與鄧納德縮放定律（Dennard Scaling）放緩。
	* 記憶體瓶頸 (Memory Bottleneck)：「記憶體牆」問題，即 CPU 算力遠快於 DRAM 存取速度。
	* 資安與硬體漏洞 (Security & Privacy)：如 Spectre、Meltdown 及 Rowhammer 攻擊。
---
### 硬體實現技術比較 (Hardware Platforms)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d794b7e9-79e9-421f-9ba2-5aee9b721454" />

| 比較項目 | 微處理器 (Microprocessors) | FPGA | ASIC |
| :--- | :--- | :--- | :--- |
| 特性 | 通用構件（CPU/GPU） | 可重新組態的硬體，極具彈性 | 完全客製化的專用晶片 |
| 開發時間 | 幾分鐘（撰寫軟體） | 幾天（邏輯合成與佈局） | 幾個月（實體光罩與下片） |
| 相對效能 | 基準 (o) | 較優 (+) | 極佳 (++) |
| 適用場景 | 通用計算、簡單易用 | 原型設計 (Prototyping)、小量生產 | 量產產品、追求極致效能與低功耗 |
| 產出形式 | 可執行檔 (Executable File) | 位元流檔案 (Bitstream) | 設計光罩 (Design Masks) |
| 程式語言 | C / C++ / Java / Python | Verilog / VHDL | Verilog / VHDL |
| 代表廠商 | Intel, AMD, ARM, Apple, NVIDIA | Xilinx (AMD), Altera (Intel) | TSMC (台積電), GlobalFoundries |
---
### CMOS 邏輯閘結構 (CMOS Logic Gates)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/1423d5e6-080b-4106-b5c1-04cf5e147478" />

1. 邏輯規則：
  * 電晶體並聯 (Parallel)：任意一個導通，網路即導通（對應 OR 邏輯）。
  * 電晶體串聯 (Series)：所有電晶體皆導通，網路才導通（對應 AND 邏輯）。

2. 特性：pMOS 與 nMOS 互補，在靜態時絕不同時導通，因此靜態功耗極低，且預設輸出為反相特性（如 NOT, NAND, NOR）。

3. 變型結構：Pseudo-nMOS 
<img width="186" height="193" alt="image" src="https://github.com/user-attachments/assets/e18859f7-16e6-4e07-8009-ee0036ad1335" />

* 為了減少晶片面積與電晶體數量，將上拉網路替換為單一常開的弱 pMOS（Weak pMOS）：
	* 優點：N 個輸入只需 N + 1 個電晶體（標準 CMOS 需要 2N 個），大幅縮減面積與輸入電容。
	* 缺點：當輸出為邏輯 0 時，pMOS 與 nMOS 同時導通，會產生持續的靜態功耗 (Static Power)；且輸出低電位準（VOL）無法完美降至 0V，雜訊邊限較差。
---
### 功耗與能量消耗 (Power & Energy Consumption)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/aaefda82-5d66-4b78-a3d3-69955b87500c" />

1. 動態功耗 (Dynamic Power)
* 電路在訊號切換（0 <-> 1）對電容充放電時產生的功耗。

$$P_{\text{dynamic}} = C \cdot V^2 \cdot f$$

* C：電路的負載電容（包含連線與邏輯閘電容）
* V：工作電壓（降低電壓可帶來二次方的省電效果）
* f：電容充放電的切換頻率

2. 靜態功耗 (Static Power)
電路靜止未切換時，因半導體漏電流（Leakage Current）所產生的功耗。

$$P_{\text{static}} = V \cdot I_{\text{leakage}}$$

* I_leakage：漏電流（隨製程微縮而持續增加）

3. 總能量消耗 (Energy Consumption)
執行特定工作負載所消耗的總能量：

$$\text{Energy} = \text{Power} \times \text{Time}$$



[回目錄](#toc)

---
<a id="m08d14"></a>

## 2026 年 8 月 14 日

## 今日進度：
### 刷題：複習 HDLbits - Shift Registers
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L3](https://www.youtube.com/watch?v=smHJ1W7S-2Q&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=3)


## 關鍵知識/詞彙：
### 三態緩衝器應用 (Tri-State Buffer Applications)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/fa232dfd-aa1a-4202-9d05-748f060bc7bc" />

1. 應用情境與問題
* **共用匯流排問題：** 假設有一條導線（Shared Bus）同時連接 CPU 與記憶體（Memory）。
* **存取限制：** 在任何時間點，只能由 CPU **或** 記憶體其中一方將數值傳送到導線上，絕不能兩者同時傳送。
* **短路風險：** 若兩者同時輸出不同的電位（例如 CPU 輸出高電位 1，記憶體輸出低電位 0），會導致**匯流排衝突（Bus Contention）**，造成短路並損壞晶片。

2. 解決方案與運作機制
* **雙三態緩衝器架構：** 一個由 CPU 驅動，另一個由記憶體驅動。
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d9972c28-760c-4400-9959-0c0ab0646aed" />

3. 控制邏輯狀態
* **CPU 寫入至匯流排：** `GateCPU = 1`（導通），`GateMem = 0`（高阻抗 Hi-Z）。
* **記憶體讀出至匯流排：** `GateCPU = 0`（高阻抗 Hi-Z），`GateMem = 1`（導通）。
* **匯流排空閒 (Idle)：** `GateCPU = 0`，`GateMem = 0`（兩者皆為高阻抗 Hi-Z，斷開連接）。

---
### 儲存元件總覽 (Storage Elements)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/23697252-c053-49c5-b058-e22b83015878" />

| 儲存元件種類 | 速度 | 成本與結構 | 適用場景 / 用途 |
| :--- | :--- | :--- | :--- |
| **Latches & Flip-Flops** | 極快 (Very fast)，支援平行存取 | 極高 (Very expensive)，1 bit 需要數十個電晶體 | CPU 暫存器 (Registers) |
| **SRAM (Static RAM)** | 相對快 (Relatively fast) | 高 (Expensive)，1 bit 需要 6 個以上的電晶體 (6T+) | CPU 快取記憶體 (Cache, L1/L2/L3) |
| **DRAM (Dynamic RAM)** | 較慢，讀取會破壞資料（需 Refresh） | 便宜 (Cheap)，1 bit 僅需 1 電晶體 + 1 電容 (1T1C) | 主記憶體 (Main Memory / RAM) |
| **Other Storage** (Flash/HDD/Tape) | 非常慢，存取時間長 | 極便宜 (Very cheap)，具備非揮發性 (Non-volatile) | 外部與長期儲存設備 (SSD, HDD, 磁帶) |

---
### 記憶體讀取與寫入架構 (Memory Read & Write Architecture)

1. 讀取機制 (Reading from Memory)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/68bb5479-daaf-451a-af6b-176a7aa16fcc" />

* **位址解碼 (Address Decoding)：**
  * 2 個位址需要 $\log_2(2) = 1\text{ bit}$ 的位址線 (`Addr[0]`)。
  * `Addr[0] = 0` 時經由反相器選中上排（Address 0）；`Addr[0] = 1` 時選中下排（Address 1）。
* **資料輸出多工 (Data Multiplexing)：**
  * 每個儲存單元後方接一個 AND 閘作為讀取門控。
  * 同一行的兩排訊號透過 OR 閘匯合輸出，確保資料線 $D[2:0]$ 輸出正確選中的位址資料。

2. 寫入機制 (Writing to Memory)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/3f1dddaf-b7b5-4fff-8a43-b42f6dbe11d4" />

* **控制訊號：**
  * `WE` (Write Enable)：寫入致能訊號。當 `WE = 1` 時允許寫入。
  * $D_i[2:0]$：準備寫入的 3-bit 輸入資料線。
* **寫入控制邏輯：**
  * 只有被選中那一排的 D-Latch Enable 端會被拉高，進而鎖存 $D_i[2:0]$ 的新資料。

3. 讀寫模式對照
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/4cdb4a99-89f0-4198-9e28-dba326f292b6" />

| 操作模式 | WE | Addr[0] | 運作行為 |
| :--- | :---: | :---: | :--- |
| **純讀取 (Read)** | `0` | `0` 或 `1` | 寫入控制 AND 閘皆為 0，鎖存器保持舊資料。右側依 `Addr[0]` 輸出位址資料至 $D[2:0]$。 |
| **寫入 Address 0** | `1` | `0` | 上排寫入 AND 閘輸出 1，將 $D_i[2:0]$ 鎖存至上排。 |
| **寫入 Address 1** | `1` | `1` | 下排寫入 AND 閘輸出 1，將 $D_i[2:0]$ 鎖存至下排。 |

---
### FPGA 中的尋找表 (Lookup Tables / LUTs)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/dbf03ba4-8413-4ae0-b0b5-5448c4764bd2" />


* **概念：** LUT 本質上是一組 SRAM 記憶體，事先載入邏輯運算的真值表 (Truth Table)，用以實現可程式化／可重新組態邏輯 (Reconfigurable Logic)。
* **多功能拆分 (Resource Utilization)：**
  較大的 LUT（例如 4-Input LUT）可透過多工器 (MUX) 與訊號路由，靈活分割成多個獨立的低輸入邏輯元件（如拆成 3-Input 的 LE 1 與 2-Input 的 LE 2），藉此提高硬體利用率。

---
### 有限狀態機 (Finite State Machines, FSM)

1. 什麼是 FSM？
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/37a0d202-56fc-424e-b1ae-c1a10f61856e" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/64806188-f996-4395-ba98-e0d8f69ffac3" />


* **離散時間模型：** 一個用來表示具有狀態之系統（Stateful System）的離散時間抽象模型。
* **狀態 (State)：** 代表系統在特定時間點所有相關要素的靜態快照 (Snapshot)。
* **應用範例：** 序列密碼鎖、紅綠燈、電梯、風扇轉速控制、微處理器控制器。

2. 案例解析：序列密碼鎖 (Sequential Lock)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/040a0b47-c30f-405f-9309-b318fd335e64" />

* **開鎖密碼序列：** `R13 -> L22 -> R3`
* **狀態定義：**
  * **State A (Initial Locked)：** 初始鎖定狀態。
  * **State B (Completed R13)：** 已正確完成第一步 `R13`。
  * **State C (Completed R13-L22)：** 已正確完成前兩步 `R13-L22`。
  * **State D (Unlocked)：** 成功開鎖。
* **容錯機制：** 若輸入非預期之指令，系統會歸零重置回 State A。

3. FSM 的五大理論要素
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/af9683c6-ea5d-422f-84b2-27ee18c18077" />

* 有限數量的**狀態 (States)**
* 有限數量的**外部輸入 (External Inputs)**
* 有限數量的**外部輸出 (External Outputs)**
* 明確定義的**狀態轉移規則 (State Transitions)**
* 明確定義的**輸出決定規則 (Output Specification)**

4. FSM 的硬體架構與分工
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/4d10a739-c84a-4026-97e1-d858d3f55fde" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/8148bcd0-364d-4546-bf37-4714bd4c2297" />

* **次狀態邏輯 (Next State Logic)：** 組合邏輯電路 (CL)。根據當前輸入與當前狀態，即時計算出下一個狀態 ($S'$)。
* **狀態暫存器 (State Register)：** 時序邏輯電路 (SL)。利用 Flip-Flops 在每個時脈邊緣（Clock Edge）將下一個狀態鎖存為當前狀態 ($S$)。
* **輸出邏輯 (Output Logic)：** 組合邏輯電路 (CL)。根據當前狀態（或包含輸入）產生對應的外部輸出訊號。


[回目錄](#toc)

---
<a id="m08d18"></a>

## 2026 年 8 月 18 日

## 今日進度：
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L4](https://www.youtube.com/watch?v=MHlj1bARKPw&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=5)


## 關鍵知識/詞彙：

### FSM 基本概念與分類
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/9cc1c2f7-2653-469f-a541-a5baf550824d" />

* **基本運作**：下一個狀態 (Next State) 由「當前狀態 (Current State)」與「輸入 (Inputs)」共同決定。
* **分類方式**：有限狀態機依據**輸出邏輯 (Output Logic)** 的決定方式分為兩類：
  * **Moore FSM**：輸出僅取決於當前狀態 (Current State)。
  * **Mealy FSM**：輸出同時取決於當前狀態 (Current State) 與輸入 (Inputs)。

---

### FSM 狀態編碼 (State Encoding)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/bfcb4697-90e0-4385-bfc6-10c901b72d3f" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/ef9cff2c-3afb-42ca-bbda-b78b1fe9e8e8" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/30a0d97f-0942-4574-a491-34ed3e5391b0" />


* 狀態位元編碼主要有三種常見策略，各自具備不同的 Trade-offs ：

| 編碼策略 | 位元數與規則 | 特性與極值優化 | 範例編碼 (以 4 狀態號誌為例) |
| --- | --- | --- | --- |
| **Binary Encoding (Full Encoding)** | 使用最小可能位元數，即 log2(num_states) 個位元。 | **極小化** Flip-Flops 數量，但不一定能簡化輸出或次狀態邏輯。 | `00`, `01`, `10`, `11` |
| **One-Hot Encoding** | 每個位元代表一個狀態，使用 num_states 個位元，且任意狀態下恰好只有 1 個位元為高電位 ("hot")。 | **極大化** Flip-Flops 數量，**極小化** 次狀態邏輯，設計流程最簡單且高度自動化。 | `0001`, `0010`, `0100`, `1000` |
| **Output Encoding** | 輸出直接包含於狀態編碼中。例如 3 個燈號輸出即用 3 位元表示，Bit0 為綠燈、Bit1 為黃燈、Bit2 為紅燈。 | **極小化** 輸出邏輯，但**僅適用於 Moore FSM**（因其輸出純粹為狀態的函數）。 | `001`, `010`, `100`, `110` |

* **設計原則**：設計者必須在給定的硬體限制條件下，仔細選擇編碼方案以達到設計的最佳化。

---

### FSM 設計流程 (FSM Design Procedure)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a8bb5324-233c-4a6e-a730-de3e41021ddb" />


1. **確定所有可能狀態**：列出該機器所有可能的狀態。
   
2. **建立狀態轉移圖 (State Transition Diagram)**：
  * 通常從文字描述轉化而成。
  * 須確定每個狀態的輸入與輸出，並釐清狀態轉移的條件與路徑
    
3. **設計實作方法**：
  * 從定義**重置狀態 (Reset State)** 開始，這是理想的起點。
  * 逐步加入轉移條件 (Transitions) 與新狀態 (States)。
  * 選擇**良好且具意義的狀態名稱**非常重要。
    
4. **FSM 與軟體程式設計之對比**：
  * 建構 FSM 類似於編寫程式，但兩者並不等同。
  * FSM 具有類似包含條件判斷與 goto 語句的順序控制流程 (Control-Flow)。
  * if-then-else 結構由一個或多個輸入控制。
  * 輸出由狀態或輸入控制。
  * 在實際硬體中，系統通常同時運作許多併發 (Concurrent) 的 FSM。
    
5. **本質定義**：FSM 是一個具狀態系統的離散時間模型 (A discrete-time model of a stateful system)。

### 什麼是 FPGA (What is an FPGA?)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d856fb4d-d9e5-4dfa-96dc-0df6f66df538" />

* **全稱**：Field Programmable Gate Array（現場可程式化邏輯閘陣列）。
* **核心定義**：FPGA 是一種可透過**軟體重新組態 (software-reconfigurable)** 的硬體基底。
* **三大可重組要素**：
  * **可重組功能 (Reconfigurable functions)**：自訂內部邏輯運算。
  * **可重組互連線路 (Reconfigurable interconnection of functions)**：自訂內部模組間的連接關係。
  * **可重組輸入/輸出 (Reconfigurable input/output IO)**：自訂外部腳位與介面規格。

---

### FPGA 高階架構總覽 (High-Level Overview)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/56d41acb-42a9-4d2d-a669-32264b820c48" />

* **四大核心組成要素**：
  * **邏輯區塊 (Logic Blocks)**：負責執行電路的邏輯運算。
  * **開關區塊 (Switch Blocks)**：控制不同路徑之間的切換與導通。
  * **互連線路 (Interconnects)**：分佈於網格間，連接各個區塊的訊號導線。
  * **輸入/輸出區塊 (I/O Blocks)**：排列於晶片外圍，負責與外部硬體設備對接。
* **運作機制**：透過**配置 (Configure)** 邏輯區塊、連接線路與 I/O 區塊，以構建出目標硬體電路，並將程式映射 (Map) 至這些硬體電路上運作。

---

### FPGA 內部架構細節 (FPGA Architecture)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b42a8abd-cb53-4ca3-b40c-0724761db75a" />

* **兩大主要建構區塊 (Main Building Blocks)**：
  * **尋找表 (Look-Up Table, LUT)**：用於實作任意組合邏輯功能。
  * **開關 (Switches)**：用於實現可程式化的電路路由與訊號切換。
* **內部邏輯單元結構**：
  * **配置記憶體 (Configuration Memory)**：儲存 LUT 的真值表資料與開關控制位元。
  * **觸發器 (Flip-Flop)**：配合 LUT 輸出，提供時序邏輯（Sequential Logic）暫存功能。
  * **架構分工**：整體資源分為負責實際電路運作的「動作邏輯 (Action logic)」與儲存組態設定的「配置記憶體 (Configuration memory)」。



[回目錄](#toc)

---
<a id="m08d19"></a>

## 2026 年 8 月 19 日

## 今日進度：
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L5](https://www.youtube.com/watch?v=3Sqt0GIFPbc&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=7)


## 關鍵知識/詞彙：
### 電路設計的權衡 (Circuit Design Tradeoffs)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f308f71d-cb4f-437f-b081-5d5eca416a52" />

數位電路設計需要平衡以下四個核心面向：

* **面積 (Area)**：晶片電路面積直接決定硬體的成本 (Cost)。
* **速度與吞吐量 (Speed / Throughput)**：追求更快、處理能力更強的電路執行效能。
* **功耗與能量 (Power / Energy)**：
  * 行動裝置受限於有限的電源供應。
  * 高效能裝置的散熱功率密度可能超過 100 W/cm²。
* **設計時間 (Design Time)**：工程師的時間與人力成本高昂，且市場競爭不允許過長的開發週期。

---

### HDL 的主要實作風格 (Two Main Styles of HDL Implementation)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f2fd7414-977c-4f4d-b80e-926685b3700c" />

* **結構化描述 (Structural / Gate-Level)**：
  * 模組內部包含閘級 (Gate-Level) 的電路描述。
  * 詳細定義模組與模組之間的互連方式。
  * 透過模組實體化 (Instances) 與導線連接，建構出階層化 (Hierarchy) 的邏輯閘結構。
* **行為級描述 (Behavioral)**：
  * 模組內部包含電路功能的邏輯與算術運算描述。
  * 抽象化程度高於閘級 (Gate-Level)。
  * 一種行為級描述可經由工具合成為多種不同的閘級硬體實作。
* **實務應用**：大多數實際的電路設計皆為兩者的混合使用。

---

### Verilog 數字表示法 (Number Representation in Verilog)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/14c36012-a3bb-40c2-9f19-856192869466" />

---

### HDL 程式碼處理流程 (Synthesis & Simulation)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/bf4fa34a-5ae2-4b87-9671-765a80d498d7" />

1. 硬體合成 (Hardware Synthesis)
* **定義**：現代開發工具能將可合成的 (Synthesizable) HDL 程式碼映射至低階元件庫 (Cell Libraries)，產生由邏輯閘與導線組成的網表 (Netlist)。
* **限制**：工具會進行多項最佳化，但**無法保證**得到絕對最佳解（主因是佈線與佈局 Placement and Routing 演算法的運算複雜度極高）。
* **最佳實踐**：設計師需以易於合成 (Nice-to-synthesize) 的風格撰寫 HDL 程式碼。

2. 電路模擬 (Simulation)
* **定義**：可在無需實際製造晶片的情況下，驗證電路的功能與行為。
* **適用性**：模擬器可支援結構化 (Structural) 或行為級 (Behavioral) 的 HDL 描述。
* **重要性**：是進行功能驗證 (Functional Verification) 與時序驗證 (Timing Verification) 不可或缺的步驟。

---

### `always` 區塊與組合邏輯 (Combinational `always` Block)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/539412ed-160f-4c54-b489-acb955d1eb9a" />

* **關鍵概念**：`always` 區塊**不必然**代表具備記憶功能的時序電路 (Flip-Flops / Latches)。
* **組合邏輯條件**：
  * 敏感列表 (Sensitivity List) 包含所有輸入訊號。
  * 在所有條件分支 (如 `if...else`) 中，輸出訊號皆有被明確指派數值。
* **範例分析**：
  ```verilog
  always @ (inv, data)
      if (inv) result <= ~data;
      else     result <= data;
  ```
  
* 當 inv 或 data 改變時即觸發運算；因為包含完整 else 分支，此段描述會合成為純組合邏輯電路 (Combinational Logic, no memory)。

### 阻塞與非阻塞賦值 (Blocking vs. Non-blocking Assignments)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/6d4c244c-e82c-4f55-8459-e9beef4f8d7f" />

| 比較項目 | 非阻塞賦值 (Non-blocking) | 阻塞賦值 (Blocking) |
| :--- | :--- | :--- |
| **運算子 (Syntax)** | `<=` | `=` |
| **執行機制** | 區塊內所有賦值會在**區塊結束時同時更新**（平行處理） | 每個賦值會**立即生效**，完成後才執行下一行（順序執行） |
| **控制流程** | 不會阻塞 (Not-blocked) 後續程式碼評估 | 會阻塞 (Blocks) 後續程式碼的執行 |
| **行為特性** | 呈現硬體並列運作的真實物理特性 | 行為類似傳統順序式程式語言 (如 C / Python) |
| **適用邏輯** | **時序邏輯 (Sequential Logic)** | **組合邏輯 (Combinational Logic)** |

* Design Rules
	* 時序邏輯 (Sequential Logic)：描述觸發器 (Flip-Flops) 或時脈邊緣驅動電路（如 always @(posedge clk)）時，一律使用非阻塞賦值 (<=)。
	* 組合邏輯 (Combinational Logic)：描述純組合電路的 always 區塊（如 always @(*)）時，一律使用阻塞賦值 (=)。
	* 禁止混用：切勿在同一個 always 區塊中混合使用 = 與 <=，以免產生模擬與合成不一致 (Simulation/Synthesis Mismatch) 的問題。
---


[回目錄](#toc)

---
<a id="m08d20"></a>

## 2026 年 8 月 20 日

## 今日進度：

### 刷題：複習 HDLbits - Shift Registers

### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L5](https://www.youtube.com/watch?v=DBsDuQwpPsI&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=8)


## 關鍵知識/詞彙：
### 電路延遲與其變異 (Circuit Delay and Its Variation)
1. 延遲的成因與影響因素
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/54a2cf6a-f928-4f60-86a2-122ce31f2911" />

* **根本成因**：
  * 電路中存在的**電容 (Capacitance)** 與 **電阻 (Resistance)**。
  * **光速的有限性 (Finite speed of light)**：在奈秒 (ns) 尺度下，光速傳播其實並不夠快。
    
* **影響延遲的變因**：
  * **訊號轉折方向**：上升沿（ $0 \rightarrow 1$ ）與下降沿（ $1 \rightarrow 0$ ）的轉換時間不同。
  * **輸入路徑差異**：不同的輸入端經過的邏輯閘數量與路徑長度不同。
  * **環境變化**：如運作溫度的改變。
  * **元件老化 (Aging)**：晶片長期使用後的特性衰退。
    
* **結論**：從輸入到輸出，電路呈現的是一個**可能延遲的範圍 (Range of delays)**，而非固定單一值。

---

2. 延遲類型定義： $t_{cd}$ 與 $t_{pd}$
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/990add3b-6a1e-44f5-9e08-7681ac67519d" />

* **污染延遲 (Contamination delay, $t_{cd}$ )**：輸入發生變化後，輸出 $Y$ **開始產生改變**所需的最短時間。
* **傳播延遲 (Propagation delay, $t_{pd}$ )**：輸入發生變化後，輸出 $Y$ **完成改變並達到穩定狀態**所需的最長時間。
* **時序圖表示**：時序圖中的交叉斜線網格 (Cross-hatching) 區域，代表輸出值目前處於不穩定的過渡狀態。
---

3. 最長與最短延遲路徑計算 (Critical & Short Path)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/37da23ef-1f5a-4064-83e8-1f90619c4690" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d1f34507-ae9f-4cd1-a623-d6347d9cfac8" />

* 關鍵路徑 / 最長路徑 (Critical / Longest Path)
	* **傳遞路徑**：輸入 $A \rightarrow \text{AND1} \rightarrow n1 \rightarrow \text{OR} \rightarrow n2 \rightarrow \text{AND2} \rightarrow Y$。
	* **計算公式**： $$t_{pd} = 2 \cdot t_{pd\_AND} + t_{pd\_OR}$$

* 最短路徑 (Shortest Path)
	* **傳遞路徑**：輸入 $D \rightarrow \text{AND2} \rightarrow Y$。
	* **計算公式**： $$t_{cd} = t_{cd\_AND}$$

---

4. 實體元件延遲實例 (74HC00 NAND Gate)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/dfed58df-25c1-47db-9d33-7c9341b4682d" />

* 實體晶片的傳播延遲時間極度依賴於**工作電壓 (Voltage)** 與 **環境溫度 (Temperature)**：

---

5. 4:1 多工器 (Multiplexer) 架構與延遲比較
<img width="584" height="367" alt="image" src="https://github.com/user-attachments/assets/8695f5d0-6f23-4f8e-90d0-976fda2fc6dd" />

* 兩階邏輯 (Two-level Logic) vs. 三態邏輯 (Tristate Logic)

	* **兩階邏輯架構**：
  		* **選擇訊號延遲**： $t_{pd\_sy} = t_{pd\_INV} + t_{pd\_AND3} + t_{pd\_OR4} = 30\text{ ps} + 80\text{ ps} + 90\text{ ps} = \mathbf{200\text{ ps}}$
  		* **資料訊號延遲**： $t_{pd\_dy} = t_{pd\_AND3} + t_{pd\_OR4} = \mathbf{170\text{ ps}}$
	* **三態邏輯架構**：
  		* **選擇訊號延遲**： $t_{pd\_sy} = t_{pd\_INV} + t_{pd\_AND2} + t_{pd\_TRI\_SY} = 30\text{ ps} + 60\text{ ps} + 35\text{ ps} = \mathbf{125\text{ ps}}$
  		* **資料訊號延遲**： $t_{pd\_dy} = t_{pd\_TRI\_AY} = \mathbf{50\text{ ps}}$

### 階層式 2:1 多工器串接 (Hierarchical 2:1 Muxes)
<img width="241" height="286" alt="image" src="https://github.com/user-attachments/assets/90d66e30-3dc4-476f-a90c-50332a0b6e01" />

使用三個 2:1 多工器模組組合出 4:1 多工器：

* **選擇訊號 $S_0$ 延遲**： $$t_{pd\_s0y} = t_{pd\_TRLSY} + t_{pd\_TRI\_AY} = 85\text{ ns}$$
  
* **資料訊號 $D$ 延遲**： $$t_{pd\_dy} = 2 \cdot t_{pd\_TRI\_AY} = 100\text{ ns}$$

---
### 電路毛刺與訊號突波 (Glitches)

1. 定義與成因
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a7609aac-2fda-4226-8e6a-f79881438767" />

* **定義**：單一輸入訊號的轉折（Transition），導致輸出端產生多次不必要的過渡轉折（例如 $1 \rightarrow 0 \rightarrow 1$ ）。
* **成因**：電路中同時存在**快路徑 (Fast path)** 與 **慢路徑 (Slow path)**。由於傳遞路徑上的邏輯閘數量不同或延遲不均，造成訊號抵達時間不一致。
* **範例分析**：當輸入 $B$ 發生 $1 \rightarrow 0$ 轉折時，經由 2 個邏輯閘的快路徑與經由 3 個邏輯閘的慢路徑產生時間差，導致輸出 $Y$ 短暫掉至 $0$ 後又升回 $1$（即出現 $1 \rightarrow 0 \rightarrow 1$ 的 Glitch）。

---

2. 利用卡諾圖 (K-Maps) 消除毛刺
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/554489af-9de4-42fb-988f-b0a7040e093d" />

* **解決機制**：在卡諾圖中加入**共識項 (Consensus Term)**，填補相鄰主要隱項 (Prime Implicants) 之間的過渡邊界。
* **邏輯推導**：
  * **原始表示式**（存在毛刺）： $$Y = \bar{A}\bar{B} + BC$$
  * **加入共識項後**（消除毛刺）： $$Y = \bar{A}\bar{B} + BC + \mathbf{\bar{A}C}$$
* **效果**：新增的共識項 $\bar{A}C$ **不依賴變數 $B$**。當變數 $B$ 發生轉折時， $\bar{A}C$ 項能持續保持輸出為 $1$，從而完全消除毛刺。

---

3. 實務設計權衡 (Design Trade-offs)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/1a8e05fc-c6b7-4ec4-ab80-b55ccbe30c77" />

#### 消除毛刺的代價
* **晶片面積增加 (More Area)**：需要額外的邏輯閘來實作共識項。
* **功耗上升 (More Power)**：更多的電路邏輯帶來更高功耗。
* **開發成本增加 (More Design Effort)**：額外的設計與驗證工時。

#### 是否總是需要消除毛刺？
* **不需要**。無論過渡期間是否發生毛刺，電路最終保證會收斂 (Converge) 至正確的穩定狀態值。
* **應用場景判斷**：
  * 若系統僅關注**長期穩態輸出 (Long-term Steady State)**（如同步時序電路在 Clock Edge 採樣），毛刺通常可被忽略。
  * 由設計師根據應用需求決定（例如非同步控制、時脈驅動或重置訊號等敏感路徑才需特別消除毛刺）。
---
### 時序邏輯電路時序約束 (Sequential Circuit Timing Constraints)

1. D 觸發器 (D Flip-Flop) 輸入時序限制
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/fc10874b-9065-4612-a891-50510f8fa18b" />

為了確保 D 觸發器能正確採樣資料，輸入訊號 $D$ 在時脈有效邊緣 (Active Clock Edge) 採樣時必須保持穩定。

* **建立時間 (Setup Time, $t_{\text{setup}}$ )**：資料訊號在時脈邊緣**到達前**，必須維持穩定的最短時間。
* **保持時間 (Hold Time, $t_{\text{hold}}$ )**：資料訊號在時脈邊緣**到達後**，必須維持穩定的最短時間。
* **孔徑時間 (Aperture Time, $t_{\text{a}}$ )**：資料必須保持絕對穩定的總時間視窗，定義為： $$t_{\text{a}} = t_{\text{setup}} + t_{\text{hold}}$$

---

2. 時序電路運作條件與違規 (Timing Violations)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/5d581f88-56d7-40e1-8064-2e3f95675ad2" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/303ef8d6-884a-4fff-b93e-e593df1b3180" />

在相鄰兩個觸發器（例如 $R1 \rightarrow \text{組合邏輯 } (CL) \rightarrow R2$ ）之間的資料傳輸中：

* **組合邏輯過慢 (Too Slow)**：導致資料無法及時到達 $R2$，引發 ** $t_{\text{setup}}$ 違規 (Setup Violation) **。
* **組合邏輯過快 (Too Fast)**：新資料過早到達 $R2$，覆蓋掉剛採樣的舊資料，引發 ** $t_{\text{hold}}$ 違規 (Hold Violation) **。

---

3. 建立時間約束 (Setup Time Constraint)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/6fe2e667-91e3-4e58-bb70-5e9eeef3abf9" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/ef642ed0-e4d4-4532-9c63-32883d44dbc2" />

* **核心概念**：取決於從 $R1$ 到 $R2$ 的**最長延遲路徑（關鍵路徑 Critical Path）**。
* **約束公式**： $$T_{\text{c}} > t_{\text{pcq}} + t_{\text{pd}} + t_{\text{setup}}$$
  *(其中 $T_{\text{c}}$ 為時脈週期， $t_{\text{pcq}}$ 為觸發器傳播延遲， $t_{\text{pd}}$ 為組合邏輯傳播延遲)*
* **效能影響**：
  * 關鍵路徑決定了系統的最短時脈週期 $T_{\text{c}}$ 與最高工作頻率 $f_{\text{max}} = 1 / T_{\text{c}}$ 。
  * 若關鍵路徑過長，整體設計將被迫在較低頻率下運作。
  * **定序開銷 (Sequencing Overhead)**： $t_{\text{pcq}} + t_{\text{setup}}$ 屬於每個週期中被浪費的時間開銷，僅有 $t_{\text{pd}}$ 是進行有效邏輯運算的時間。

---

4. 保持時間約束 (Hold Time Constraint)
<img width="958" height="719" alt="image" src="https://github.com/user-attachments/assets/4bfc41dc-890e-4a13-87f9-ce027df20305" />

* **核心概念**：取決於從 $R1$ 到 $R2$ 的**最短延遲路徑 (Shortest Path)**。
* **約束公式**： $$t_{\text{ccq}} + t_{\text{cd}} > t_{\text{hold}} \implies t_{\text{cd}} > t_{\text{hold}} - t_{\text{ccq}}$$
  *(其中  $t_{\text{ccq}}$  為觸發器污染延遲，  $t_{\text{cd}}$  為組合邏輯污染延遲)*
* **重要特性**：
  * **與時脈週期 $T_{\text{c}}$ 完全無關**！調慢時脈頻率無法解決 Hold Violation。
  * 晶片製造完成後若發生 $t_{\text{hold}}$ 違規極難修復，必須直接修改電路佈局（例如插入延遲 Buffer）。

---

5. 時序參數總結 (Timing Summary)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b92f3931-7a22-4f33-9ba9-25d01dc68042" />

| 符號 | 完整名稱 | 定義與說明 |
| :--- | :--- | :--- |
| ** $t_{\text{ccq}} / t_{\text{pcq}}$ ** | Clock-to-Q Delay | 時脈邊緣觸發後，觸發器輸出端 Q 開始改變 ( $t_{\text{ccq}}$ ) 或達到穩定改變 ( $t_{\text{pcq}}$ ) 的延遲。 |
| ** $t_{\text{cd}} / t_{\text{pd}}$ ** | Logic Delay | 組合邏輯電路的污染延遲 ( $t_{\text{cd}}$ ) 與傳播延遲 ( $t_{\text{pd}}$ )。 |
| ** $t_{\text{setup}}$ ** | Setup Time | 觸發器輸入端在時脈邊緣**前**必須保持穩定的最短時間。 |
| ** $t_{\text{hold}}$ ** | Hold Time | 觸發器輸入端在時脈邊緣**後**必須保持穩定的最短時間。 |
| ** $T_{\text{c}}$ ** | Clock Period | 時脈訊號的週期時間。 |
---
### 時脈偏移與時脈網路 (Clock Skew and Clock Network)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/4761e2a0-c687-47ee-a610-74b7a62dd5ab" />

1. 時脈偏移 (Clock Skew) 的影響

* **實質效應**：時脈偏移 (Clock Skew) 會同時**增加**系統實務上所需的 $t_{\text{setup}}$ 與 $t_{\text{hold}}$ 裕度。
* **定序開銷增加 (Increased Sequencing Overhead)**：
  * Skew 相當於額外消耗了時脈週期中的可用時間。
  * 導致每個時脈週期內，能用來進行有效邏輯運算 (Useful Work) 的時間變得更少。

---

2. 時脈網路設計目標 (Clock Network Goals)

* **最小化 Skew**：設計師必須盡可能將全晶片內部的時脈偏移降至最低。
* **核心目標**：確保時脈訊號 (Clock) 能在**幾乎相同的時間**抵達晶片上各個觸發器的時脈輸入端。
* **解決方案**：需要在整個晶片佈局中規劃並建構智慧型的「**時脈網路 (Clock Network)**」。

---
### 時脈網路分配架構 (Clock Network Architectures)

為了消除跨區延遲差異，晶片設計中會採用不同的時脈分配結構：

* **時脈樹 (Clock Tree)**：透過階層式的驅動器 (Drivers) 進行對稱分枝，平衡各路徑的傳播延遲。
* **跨接網絡 (Crosslink / Spine)**：在樹狀結構的中間層加入跨接線，強化不同區域間時脈的同相度。
* **時脈網格 (Clock Mesh / Grid)**：建立全域 (Global) 與局部 (Local) 的網格狀導線，雖然功耗較高且佔用面積，但能提供極佳的抗變異能力與最低的 Skew。
---
### 自動檢查測試平台與測試向量 (Self-Checking Testbench & Testvectors)

1. 基礎自動檢查測試平台 (Self-Checking Testbench)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/3e232f38-d27c-4867-9f77-2cc91569425c" />

* **優點 (Pros)**
  * **設計簡單**：結構直覺且易於撰寫。
  * **方便測試特定情境**：能輕易驗證少數特定輸入（例如 Corner Cases）。
  * **自動報錯**：只要發生錯誤，模擬器會自動印出訊息 (`Simulator will print whenever an error occurs`)。

* **缺點 (Cons)**
  * **缺乏擴充性**：無法有效擴展至數百萬個測試用例。
  * **硬編碼值 (Hardcoded Values) 易生錯**：
    * 寫測試平台出錯的機率與寫實際電路程式碼一樣高。
    * 發生錯誤時，難以釐清問題是在測試平台還是在待測物 (DUT, Device Under Test)。
---

2. 使用測試向量的測試平台 (Testbench using Testvectors)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/983a4ee4-5022-43f9-a483-f3b98a0ec7f9" />

* **測試向量檔案 (Testvector File)**
  * **定義**：包含輸入與預期輸出對應關係的文字列表。
  * **產生方式**：可手動編寫，或利用已驗證且較簡單的「黃金模型 (Golden Model)」自動產生。
---

3. 測試向量測試平台設計機制 (Testbench with Testvectors Design)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/5b9c6364-5e2a-4ff6-9a15-0271b6215388" />

* **時脈訊號 (Clock Signal) 的作用**
  * 用於指定輸入與讀取輸出，每個時脈週期 (Clock Cycle) 測試一組測試向量。
  * **上升沿 (Rising Edge)**：施加輸入訊號 (Apply input)。
  * **下降沿 (Falling Edge)**：檢查輸出結果 (Check outputs)。

* **注意事項**
  * **隔離作用**：時脈訊號僅用來在時序上分隔「輸入」與「輸出」，以便在波形圖中進行觀察。
  * **非實體時序驗證**：此處的時脈**不用於**檢查實體電路時序（如 $t_{\text{setup}}$ 與 $t_{\text{hold}}$ ）。

---

4. 測試向量自動檢查機制之優缺點 (Pros & Cons)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/8fbff339-cff6-4035-90b8-faece1b0ad09" />

| 類別 | 特性與說明 |
| :--- | :--- |
| **優點 (Pros)** | • **維持易用性**：依然易於設計且適合測試 Corner Cases。<br>• **自動報錯**：錯誤發生時模擬器會自動印出訊息。<br>• **不需修改硬編碼**：執行不同測試時，不需要修改程式碼中的硬編碼值，只需更換測試向量檔。 |
| **缺點 (Cons)** | • **品質依賴**：若測試向量來源不準確，容易產生錯誤 (Error-prone)。<br>• **受限於檔案與記憶體**：雖然擴充性較高，但仍受限於檔案讀取與記憶體容量；若待測組合邏輯路徑數量極大，可能無法全數載入記憶體。 |
---
### 滿足時序約束與設計原則 (Meeting Timing Constraints & Design Principles)

1. 滿足時序約束的實務方法 (Meeting Timing Constraints)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/000f1ef8-f268-4b2e-903e-6b7313844b22" />

* **手動與疊代過程 (Manual & Iterative Process)**
  * 滿足嚴格的時序約束（例如高效能設計）通常是一個極其繁瑣 (Tedious) 的手動疊代過程。

* **工具層面與參數調整 (Synthesis / Place-and-Route Options)**
  * **更換隨機種子 (Random Seeds)**：嘗試不同的隨機種子重新進行合成與佈局繞線。
  * **手動提供引導 (Manual Hints)**：為佈局繞線工具提供手動優化提示。

* **手動優化問題路徑 (Manually Optimize Problem Paths)**
  * **簡化複雜邏輯 (Simplify Complicated Logic)**：重構邏輯架構以縮短級數。
  * **拆分過長組合邏輯路徑 (Split Long Combinational Logic Paths)**：透過插入暫存器進行流水線化 (Pipelining)。
  * **修復 $t_{\text{hold}}$ 違規**：藉由加入**更多**邏輯或延遲緩衝器 (Buffer) 來修復。

---
2. 時序設計三大核心原則 (Timing Design Principles)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/0a6459b6-e07a-4853-ac48-f3fbe91556b0" />

* **基本概念**
  * 時脈週期時間 (Clock Cycle Time) 取決於系統在不違反時序約束的前提下所能容忍的最大邏輯延遲。

* **良好設計的三大原則 (Good Design Principles)**

| 設計原則 | 核心內容與策略 | 效益與目標 |
| :--- | :--- | :--- |
| **關鍵路徑設計<br>(Critical Path Design)** | 極小化最大邏輯延遲 (Minimize maximum logic delay)。 | **極大化整體效能 (Maximizes Performance)** |
| **平衡設計<br>(Balanced Design)** | 平衡系統中各個區域（即不同 Flip-Flop 對之間）的最大邏輯延遲。 | **消除效能瓶頸並極小化浪費的時間 (No Bottlenecks + Minimizes Wasted Time)** |
| **常態優化設計<br>(Bread and Butter Design)** | 優先優化最常見的執行情境 (Optimize for Common Case)，同時確保非常態情境不會拖垮整體設計。 | **極大化真實應用場景下的效能 (Maximizes Performance for Realistic Cases)** |




[回目錄](#toc)

---
<a id="m08d21"></a>

## 2026 年 8 月 21 日

## 今日進度：

### 刷題：複習 HDLBits 7/3 - 8/20 進度；資料：複習7/3 - 8/20 內容


## 關鍵知識/詞彙：
### 為什麼使用緩衝區可以提高驅動能力？
<img width="907" height="645" alt="image" src="https://github.com/user-attachments/assets/3abe54a7-e009-46b9-8771-f2462fad8bdb" />
<img width="900" height="900" alt="image" src="https://github.com/user-attachments/assets/dcc22333-ee0a-4a11-8a97-e586cc1f67d8" />
<img width="802" height="165" alt="image" src="https://github.com/user-attachments/assets/80af12f4-8b6d-43d5-a5e3-f5f2f9a98088" />

### clock gating 類別
<img width="763" height="739" alt="image" src="https://github.com/user-attachments/assets/c1a958aa-fc66-4423-a282-efcbadbebc82" />
<img width="771" height="728" alt="image" src="https://github.com/user-attachments/assets/383718ac-cd4e-4481-8fd6-66306bffdc23" />
<img width="788" height="664" alt="image" src="https://github.com/user-attachments/assets/e6d035d6-d2c5-4abb-b569-53728b46015c" />
<img width="785" height="356" alt="image" src="https://github.com/user-attachments/assets/2b10ca1e-80bc-43f7-a9cb-e592a5817cbf" />
<img width="769" height="456" alt="image" src="https://github.com/user-attachments/assets/c71d17d8-a172-4392-9e98-7eaedc576cc1" />


[回目錄](#toc)

---
<a id="m09d01"></a>

## 2026 年 9 月 1 日

## 今日進度：

### 刷題：複習 HDLBits 7/3 - 8/21 進度

### 資料：複習7/3 - 8/21 內容

## 關鍵知識/詞彙：
### 靜態功耗 vs. 動態功耗 (Static vs. Dynamic Power)
### 1. 核心差異對比表

| 比較項目 | 動態功耗 (Dynamic Power) | 靜態功耗 (Static Power) |
| :--- | :--- | :--- |
| **核心定義** | 電路觸發**邏輯切換 ($0 \leftrightarrow 1$)** 時所消耗的功率 | 晶片通電後**怠速待機 (Idle)** 時產生的漏電功率 |
| **物理來源** | 寄生電容充放電 (Switching) + 晶體管短路瞬間電流 | 電晶體內部的物理**漏電流 (Leakage Current)** |
| **主要影響因子** | 工作頻率 ($f$)、工作電壓 ($V_{DD}$)、邏輯切換率 ($\alpha$) | 製程節點 (奈米數越小越嚴重)、運作溫度、工作電壓 ($V_{DD}$) |
| **控制公式** | $P_{dynamic} = \alpha \cdot C_L \cdot V_{DD}^2 \cdot f$ | $P_{static} = V_{DD} \cdot I_{leak}$ |
| **主流優化技術** | **Clock Gating** (時脈門控)、DVFS (動態調壓調頻) | **Power Gating** (電源門控)、Multi-VT (多門檻電壓) |

---

### 2. 物理機制拆解

#### 1. 動態功耗 (Dynamic Power)
電路在 Signal Switch 時產生的功耗，由兩部分組成：
* **充放電功耗 (Switching Power)**：負載電容 $C_L$ 在高低電位轉移時進行充放電所消耗的能量。
* **短路功耗 (Short-Circuit Power)**：CMOS 反相器在狀態切換瞬間，PMOS 與 NMOS 會短暫同時導通，產生對地的瞬間短路電流。

$$P_{dynamic} = \alpha \cdot C_L \cdot V_{DD}^2 \cdot f + V_{DD} \cdot I_{sc}$$

#### 2. 靜態功耗 (Static Power)
只要晶片處於通電狀態，即使完全沒有 Clock 切換，元件內部發生的微觀漏電：
* **次臨限漏電 (Subthreshold Leakage)**：電晶體關閉（$V_{gs} < V_{th}$）後，汲極（Drain）與源極（Source）之間依然殘留微小電流。
* **閘極漏電 (Gate Leakage)**：先進製程下閘極絕緣層極薄，產生的量子穿隧效應電流。

$$P_{static} = V_{DD} \cdot I_{leak}$$

---

### 3. 低功耗設計對策 (Low-Power Design Strategies)

* **動態功耗降解方案**
  * **Clock Gating**：在暫存器 Idle 或運算區塊無新資料時，關閉其 Clock 樹進給，將切換機率 $\alpha$ 降為 0。
  * **DVFS (Dynamic Voltage and Frequency Scaling)**：低負載時主動降頻 $f$ 並降低電壓 $V_{DD}$（因電壓為平方項，降壓效益顯著）。

* **靜態功耗降解方案**
  * **Power Gating**：利用 Power Switch 元件，在區塊休眠時直接切斷 VDD 供電，完全杜絕 $I_{leak}$。
  * **Multi-VT Cell Selection**：關鍵路徑（Critical Path）使用低閾值電壓（Low-VT）提升速度；非關鍵路徑使用高閾值電壓（High-VT）壓抑漏電流。

[回目錄](#toc)

---
<a id="m09d03"></a>

## 2026 年 9 月 3 日

## 今日進度：
### 刷題：複習 HDLbits - Shift Registers
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L7](https://www.youtube.com/watch?v=T0Ka9QG9t-o&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=9)


## 關鍵知識/詞彙：
### 電腦基本組成與馮·紐曼模型 (Basic Components & Von Neumann Model)

#### 電腦基本組成
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f8e732e2-dfbc-4f34-8e8b-d49a3efe5141" />


**執行任務的兩大要素**

- **電腦程式 (Computer Program)**：指定電腦必須執行的任務內容
- **電腦硬體 (The Computer)**：負責執行程式所指定的任務

**程式與指令概念**

| 名詞 | 定義 |
|---|---|
| 程式 (Program) | 一組指令的集合 (A set of instructions) |
| 指令 (Instruction) | 程式中最小的可執行單位 (Smallest piece of specified work)，明確指定電腦執行的動作 |
| 指令集 (Instruction Set) | 電腦設計上所能執行的所有可能指令之集合 |

#### 馮·紐曼模型 (The von Neumann Model)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/239495ab-65be-433d-afcc-3ea5d8ffd466" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/fea60f68-3206-477a-a52a-8942548626e6" />


- 由 John von Neumann 於 1946 年提出，為處理電腦程式的基礎執行模型
- 現今所有通用型電腦皆採用此架構

**五大核心組件**

1. **記憶體 (Memory)**：存放程式 (Program) 與資料 (Data)
2. **處理單元 (Processing Unit)**：包含算術邏輯單元 (ALU) 與暫存器，負責數據運算
3. **控制單元 (Control Unit)**：控制指令執行的順序與流程
4. **輸入設備 (Input)**：接收外部輸入（如鍵盤、滑鼠、磁碟）
5. **輸出設備 (Output)**：輸出處理結果（如螢幕、印表機、磁碟）

#### 記憶體架構與定址 (Memory Architecture)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b9259bc7-fa38-4cb7-b01a-17d52515a91d" />


**基本單位**：記憶體儲存位元 (Bits)，邏輯上組合為位元組 (Bytes, 8 bits) 或字組 (Words，如 8/16/32 bits)

**位址空間 (Address Space)** — 記憶體中唯一可識別位置的總數量：

| 架構 | 位址空間 | 位址長度 |
|---|---|---|
| LC-3 | $2^{16}$ 個位址 | 16-bit |
| MIPS | $2^{32}$ 個位址 | 32-bit |
| x86-64 | 最高 $2^{48}$ 個位址 | 48-bit |

**可定址性 (Addressability)**

- **Byte-addressable**：每個位址儲存 8 個位元 (1 Byte)
- **Word-addressable**：每個位址儲存一個字組 (Word)

#### 大端序與小端序 (Big Endian vs. Little Endian)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/51ceaf29-83d0-403e-a96e-2f2d3b0bc3d3" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/8b092357-9537-4dd2-a5d9-1e2e9c0ee184" />


| 排列方式 | 定義 |
|---|---|
| 大端序 (Big Endian) | 最高有效位元組 (MSB) 存放在較低的記憶體位址；LSB 存放在較高位址 |
| 小端序 (Little Endian) | 最低有效位元組 (LSB) 存放在較低的記憶體位址；MSB 存放在較高位址 |

> 單一系統內部無影響，僅為設計慣例；但當 Big-endian 系統與 Little-endian 系統需要共享或交換資料時，必須進行轉換。

#### 記憶體存取機制：MAR 與 MDR
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/3f27204b-6b0d-4b32-80aa-0474df22b11f" />


**核心暫存器**

- **MAR (Memory Address Register)**：存放要存取的記憶體位址
- **MDR (Memory Data Register)**：存放要寫入或剛讀出的資料內容

**操作步驟**

| 操作 | 步驟 |
|---|---|
| 讀取 (Read) | 1. 將目標位址載入 MAR<br>2. 記憶體該位址的資料被放置於 MDR 中 |
| 寫入 (Write) | 1. 將目標位址載入 MAR，將欲寫入的資料載入 MDR<br>2. 觸發寫入致能訊號 (Write Enable)，將 MDR 中的值寫入 MAR 指定的位址 |

#### 處理單元與暫存器檔案 (Processing Unit & Register File)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/0292a560-b499-4979-84f2-744e9e4dca92" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a9bce139-6c4d-4818-813f-b96e665bed8d" />


- 記憶體容量大但存取速度慢；暫存器緊鄰 ALU，用於存放中間運算結果（例如計算 $((A+B) \times C) / D$ 時暫存 $A+B$ 的值），避免頻繁存取記憶體

**暫存器檔案 (Register File)**

| 架構 | GPR 數量 | 編號位元數 | 暫存器大小 |
|---|---|---|---|
| LC-3 | 8 個 (R0–R7) | 3-bit | 16 位元 |
| MIPS | 32 個 (R0–R31) | 5-bit | 32 位元 |

#### 控制單元 (Control Unit)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/c338fc4a-6bd5-4504-be91-71c51950ffd7" />


- 如同樂團指揮家 (Conductor)，按順序逐步導引程式中每條指令的執行過程

**關鍵暫存器**

- **IR (Instruction Register)**：存放當前正在被處理/執行的指令
- **PC (Program Counter / IP)**：存放下一條即將被執行的指令記憶體位址

---

### 指令集架構與執行機制 (ISA & Instruction Execution)

#### 程式員可見狀態 (Programmer Visible State)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/6673bb06-9613-494e-96f4-7dd68da4bc60" />


- 指程式員或編譯器在撰寫與執行程式時，能夠直接存取、感知與修改的硬體狀態
- 指令與程式的本質，即為定義如何轉換「程式員可見狀態」中的數值

**核心組成要素**

- **記憶體 (Memory)**：以位址作為索引的儲存陣列（從 $M[0]$ 到 $M[N-1]$）
- **暫存器 (Registers)**：在 ISA 中賦予特定名稱（而非記憶體位址），分為通用暫存器與特殊用途暫存器
- **程式計數器 (PC)**：存放當前或下一條即將執行指令的記憶體位址

#### 儲存程式與順序執行 (Stored Program & Sequential Execution)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/051b8140-5af7-4078-a427-baf7f53f7c29" />


- **儲存程式原理**：指令與資料皆儲存在記憶體中；通常指令長度會等於系統的字組長度
- **擷取-解碼-執行循環 (Fetch-Decode-Execute Cycle)**
  1. **Fetch**：處理器從記憶體擷取一條指令
  2. **Decode & Execute**：對該指令進行解碼並執行對應動作
  3. **Sequential Execution**：處理器自動接續執行下一條指令

**PC 遞增規則**

| 定址方式 | 範例架構 | PC 遞增規則 |
|---|---|---|
| 字組定址 (Word-addressable) | LC-3 | 每次遞增 1 |
| 位元組定址 (Byte-addressable) | MIPS | 每次遞增指令的位元組長度（指令長 4 Bytes，故 PC + 4） |

> MIPS 架構中，作業系統通常將 PC 初始化為 `0x00400000` 作為程式執行的起始位址。

#### 指令結構與類型 (Instruction Structure & Types)

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/362e9f1d-94be-43cf-8779-94b2d64fc9dc" />


- **指令 (Instruction)**：電腦處理的最基本單位；是電腦語言中的「字詞」，ISA 即為該語言的「詞彙表」
- **機器語言 (Machine Language)**：電腦可直接讀取的二進位表示法 (0/1)
- **組合語言 (Assembly Language)**：便於人類閱讀與撰寫的符號表示法

**指令組成成分**

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/30e3ac11-7593-484a-9a30-ffdfde7ba82c" />


- **操作碼 (Opcode)**：指定該指令要執行的動作 (WHAT)
- **操作數 (Operands)**：指定動作執行的對象或目標位置 (WHO)

**三大指令類型**

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e95fb88b-ace5-4875-9e94-a9e23a2d5c85" />


1. **運算指令 (Operate instructions)**：在 ALU 中執行算術或邏輯運算
2. **資料移動指令 (Data movement instructions)**：負責從記憶體讀取資料或將資料寫入記憶體
3. **控制流指令 (Control flow instructions)**：改變程式原有的順序執行流程

#### 指令格式與編碼 (Instruction Encoding)

**LC-3 — Operate Format (16 bits)**

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/0d94a75d-3c26-4fc7-97c4-304eb75de438" />


| 欄位 | 位元範圍 | 說明 |
|---|---|---|
| OP | [15:12] (4 bits) | 操作碼（如 ADD=0001, AND=0101） |
| DR | [11:9] (3 bits) | 目的暫存器 |
| SR1 | [8:6] (3 bits) | 第一來源暫存器 |
| — | [5:3] (3 bits) | 控制位元（設為 000） |
| SR2 | [2:0] (3 bits) | 第二來源暫存器 |

```
0001 110 001 000 110  →  ADD R6, R2, R6   (R6 ← R2 + R6)
```

**MIPS — R-Type Format (32 bits)**

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/283e6ab4-fedc-4be2-9765-ca9e51c9b9b3" />


| 欄位 | 位元範圍 | 說明 |
|---|---|---|
| opcode | [31:26] (6 bits) | 固定為 0 |
| rs | [25:21] (5 bits) | 第一來源暫存器 |
| rt | [20:16] (5 bits) | 第二來源暫存器 |
| rd | [15:11] (5 bits) | 目的暫存器 |
| shamt | [10:6] (5 bits) | 位移量 |
| funct | [5:0] (6 bits) | 具體運算功能碼 |

> 適用於 3 個暫存器操作數的運算指令

#### 記憶體載入與定址模式 (Load Word & Addressing Mode)

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/68134495-05bb-436b-a30c-1a8aef341c96" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/eb7eb902-3e39-4a02-a512-70c02edda756" />


**載入指令概念**：高階語言 `a = A[i];` 對應組合語言 `load a, A, i`

- `load`：載入字組的助記碼
- `A`：基底位址 (Base address)
- `i`：偏移量 (Offset)，可為立即數/常數
- `a`：目的操作數 (Destination operand)
- 執行語意：`a ← Memory[A + i]`

**基底+偏移量定址 (Base+Offset Addressing Mode)**：指令透過「基底暫存器裡的值」加上「指定的偏移量」計算出最終記憶體目標位址。

| 架構 | 組合語言範例 | 語意 |
|---|---|---|
| LC-3 | `LDR R3, R0, #2` | `R3 ← Memory[R0 + 2]` |
| MIPS | `lw $s3, 2($s0)` | `$s3 ← Memory[$s0 + 2]` |

---

### 指令週期與控制指令 (Instruction Cycle & Control Flow)

#### 指令週期概述 (The Instruction Cycle)

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/4b6eef8d-1b8d-49b9-8943-bb39832602d0" />


指令週期是指令被執行時所經歷的一系列階段，完整包含六個階段：

```
FETCH → DECODE → EVALUATE ADDRESS → FETCH OPERANDS → EXECUTE → STORE RESULT
```

**並非所有指令皆需要完整六階段**

| 指令 | 省略的階段 |
|---|---|
| LDR | 不需要 EXECUTE 階段 |
| ADD | 不需要 EVALUATE ADDRESS 階段 |
| `ADD [eax], edx` (x86) | 需要完整六個階段的範例 |

#### 擷取與解碼 (FETCH & DECODE)

**FETCH（擷取指令）**：從記憶體取得指令並載入至 IR，此階段為所有指令類型共通。

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/66ff34d1-053e-4bc9-8130-b3ec8ab7f1f7" />


1. 將 PC 的內容載入 MAR，並同步將 PC 遞增
2. 查詢記憶體，將記憶體讀出的指令放置於 MDR
3. 將 MDR 的內容載入至 IR

**DECODE（解碼指令）**：辨識指令類型並產生控制訊號，以供後續階段處理。

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/dd91a12a-fea6-4086-aa4c-31177608be93" />


- 以 4-to-16 解碼器為例，輸入為 IR[15:12] 的 4 個位元，用以辨識 16 種 Opcode 之一
- 剩餘的 12 個位元用於辨識處理該指令所需的其他資訊

#### 位址計算與操作數擷取

**EVALUATE ADDRESS（計算位址）**：計算處理指令所需的記憶體目標位址。

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/29d97b4f-1c70-4008-a859-d25e324e32f8" />


- LDR 需要：將暫存器內容加上偏移量，計算出欲從記憶體讀取的資料字組位址
- ADD 不需要：不涉及記憶體位址存取

**FETCH OPERANDS（擷取操作數）**：取得處理指令所需的來源操作數。

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/9b85597c-4124-4878-8fe7-f2dbcf3a1c80" />


- LDR：將計算出的位址載入 MAR → 讀取記憶體 → 將來源操作數放置於 MDR
- ADD：直接從暫存器檔案取得來源操作數；部分微處理器可在 DECODE 同時同步進行暫存器操作數擷取

#### 執行與結果儲存

**EXECUTE（執行）**：執行指令的核心運算動作。

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d217c90b-2f58-4ec3-b9ff-a2b9a6c8f07e" />


- ADD：於 ALU 中執行加法運算
- XOR：於 ALU 中執行逐位元 XOR 運算

**STORE RESULT（儲存結果）**：將運算或處理結果寫回指定的目的地（暫存器或記憶體）。

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f6e048be-6483-492f-be30-2a139cdf9be4" />


> 當 STORE RESULT 完成後，隨即開啟一個全新的指令週期（重新進入 FETCH 階段）。

#### 改變執行順序 (Changing the Sequence of Execution)

<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/149aecec-1ddb-4489-a88f-7ab563a4af25" />


- **順序執行 (Sequential Execution)**：預設情況下，程式按照指令順序依次執行
- **控制指令 (Control Instructions)**：允許程式進行非順序 (Out of sequence) 執行
  - 運作機制：控制指令在 **EXECUTE 階段** 透過將目標位址載入 PC 來改變程式計數器的值
  - 這會直接覆蓋/清除在 FETCH 階段時自動遞增的 PC 值，從而實現程式跳轉


[回目錄](#toc)

---
<a id="m09d14"></a>

## 2026 年 9 月 14 日

## 今日進度：

### 資料：複習7/3 - 9/14 內容


[回目錄](#toc)

---
<a id="m09d15"></a>

## 2026 年 9 月 15 日

## 今日進度：
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L8](https://www.youtube.com/watch?v=o2YvlUCv9d4&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=10)


## 關鍵知識/詞彙：
### LC-3 Architecture: Jump (JMP) 指令筆記
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f2aa81a4-3c03-42d7-b8d7-1792cba3b3db" />

> **核心概念**：`JMP` 是用來**改變程式指令的執行順序（控制流）**，而非修改資料。執行時會直接覆寫 **PC (Program Counter)**，讓 CPU 跳轉至指定記憶體位址繼續執行。

---

#### 1. JMP 指令特性

* **無條件跳轉 (Unconditional Branch / Jump)**：不需檢查任何條件標誌（如 N, Z, P），執行到即強制跳轉。
* **暫存器定址模式 (Register Addressing Mode)**：跳轉的目標位址儲存在指定的通用暫存器中（如 `R2`），運作邏輯為 `PC ← BaseR`。

---

#### 2. 指令格式 (16-bit Instruction Format)

| Opcode (4 bits) | Unused (3 bits) | BaseR (3 bits) | Unused (6 bits) |
| :---: | :---: | :---: | :---: |
| `1100` | `000` | `000` ~ `111` | `000000` |

* **Opcode (`1100`)**：LC-3 的 `JMP` 操作碼。
* **BaseR**：指定存放目標記憶體位址的暫存器編號（如 `010` 代表 `R2`）。

---

#### 3. 相關延伸指令 (Variations)

* **`RET` (Return)**：從副程式（Subroutine / Function）返回主程式。
  * 本質為 `JMP` 的特例：固定指定 `BaseR = R7`（即 `PC ← R7`）。
* **`JSR` / `JSRR` (Jump to Subroutine)**：呼叫副程式。
  * 在跳轉至新位址前，會先將目前的下一行位址自動存入 `R7`（記錄返回點），以利後續搭配 `RET` 返回。
---
### LC-3 Architecture: Control of the Instruction Cycle (FSM)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e96b1a13-34b3-45b9-839f-8562fdf2e2ea" />

> **核心概念**：LC-3 控制器本質上是一個 **有限狀態機 (Finite State Machine, FSM)**。它透過控制訊號（Control Signals）在不同狀態之間切換，驅動 CPU 完成完整的指令週期（Fetch → Decode → Execute）。

---

#### 1. 指令擷取階段 (FETCH Phase)

| 狀態 (State) | 微操作 (Micro-operation) | FSM 控制訊號與動作 (Control Signals) |
| :--- | :--- | :--- |
| **State 1** | `MAR ← PC`<br>`PC ← PC + 1` | • 觸發 `GatePC` 與 `LD.MAR`（把 PC 值送到 MAR）<br>• `PCMUX` 選擇 `+1` 並觸發 `LD.PC`（PC 自動遞增 1） |
| **State 2** | `MDR ← M[MAR]` | • 從記憶體讀取指令寫入 MDR |
| **State 3** | `IR ← MDR` | • 觸發 `GateMDR` 與 `LD.IR`（將指令載入至 IR 準備解碼） |

---

#### 2. 指令解碼與執行階段 (DECODE & EXECUTE)

### 解碼階段 (DECODE)
* **State 4**：解析 IR 中的 **Opcode**，根據不同的指令跳轉至對應的執行狀態序列。

### 執行階段 (EXECUTE) 範例
* **JMP 指令分支 (State 63)**：
  * 執行 `PC ← Register`（將指定暫存器的位址載入 PC）。
* **其他指令分支**：
  * **ADD**：前往 ADD 專屬的執行狀態群。
  * **LDR**：前往 LDR 專屬的執行狀態群。

---

#### 3. 週期的循環機制

所有指令在執行完最後一個狀態（Last state）後，控制邏輯都會**強制回到 State 1**，開始下一個指令的擷取流程。
---

### ISA (Instruction Set Architecture) 指令集架構
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/3c831096-a8e2-4e5e-9eac-3b54180d4c0d" />

#### 1. 核心組成要素
* **指令集（Instruction Set）**：CPU 支援的基本指令，包含算術運算（`ADD`）、邏輯運算（`AND`）、資料搬移（`LOAD`/`STORE`）及流程控制（`JMP`）。
* **暫存器結構（Registers）**：定義 CPU 內部暫存器的數量、名稱與位元寬度（如 32-bit 或 64-bit）。
* **記憶體定址模式（Addressing Modes）**：規定 CPU 如何存取與尋找記憶體中的資料位置。
* **資料型態（Data Types）**：指定 CPU 原生支援的資料格式（如整數、單/雙精度浮點數、向量資料）。
---

#### 2. 常見的 ISA 分類

| 架構類型 | 特點 | 代表性 ISA | 主要應用領域 |
| :--- | :--- | :--- | :--- |
| **CISC** *(複雜指令集)* | 指令功能豐富、長度不固定，單一指令可完成較多動作。 | **x86 / x86-64** | 個人電腦 (Intel/AMD)、傳統伺服器 |
| **RISC** *(精簡指令集)* | 指令精簡且長度固定，執行效率高、功耗較低。 | **ARM**<br>**RISC-V** | 智慧型手機、Apple Silicon、嵌入式系統、開源硬體 |

---

#### 3. ISA vs. 微架構 (Microarchitecture)

* **ISA（介面契約）**：規定 CPU **「能做什麼」**（What to do）。
  * *範例*：定義指令 `ADD` 可以把兩個數字相加。
* **微架構（硬體實現）**：決定 CPU **「怎麼做」**（How to do）。
  * *範例*：Intel 與 AMD 都支援 x86 ISA（可執行相同的軟體），但兩家公司內部的電路設計與流水線（Pipeline）架構完全不同。
---
### ISA Concepts: Opcodes (操作碼) 
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b1a43221-8f64-4d5f-a273-2ca5124e55a0" />

> **核心概念**：Opcode（操作碼）是指令中用來指定 CPU 執行特定操作（如加法、跳轉、記憶體存取）的位元碼。指令集架構設計者可在「龐大複雜的 Opcode 集合」與「精簡基本的 Opcode 集合」之間進行設計選擇與權衡。

---

#### 1. Opcode 集合設計實例 (Opcode Set Sizes)

不同架構對 Opcode 數量的設計哲學各有不同：

* **HP Precision Architecture**：提供複合運算指令，例如單一指令完成 `A * B + C`（乘加運算 FMA）。
* **x86 ISA**：持續擴充 Opcode 數量以支援進階運算，如多媒體與矩陣平行運算擴充集（MMX, SSE, AVX, AMX）。
* **VAX ISA**：提供極度複雜的指令，例如單一 Opcode 即可在程式切換（Context Switch）前保存該程式的所有狀態資訊。

---

#### 2. 設計權衡 (Tradeoffs)

選擇 Opcode 的數量與複雜度時需考慮以下權衡：

| 權衡面向 | 說明 |
| :--- | :--- |
| **硬體複雜度 vs. 軟體複雜度** | 複雜 Opcode（CISC 哲學）可減少軟體指令數，但大幅增加硬體解碼與電路複雜度；簡化 Opcode（RISC 哲學）則硬體設計簡單，但需由軟體/編譯器組合更多指令。 |
| **指令執行延遲 (Latency)** | 複雜指令單次執行耗時較長；簡單指令單獨執行速度快，但完成複雜功能需要多條指令配合。 |

---

#### 3. LC-3 與 MIPS 的指令三大分類 (Three Types of Opcodes)

在 **LC-3** 與 **MIPS** 等精簡架構中，所有 Opcode 皆可歸類為以下三種基本型態：

1. **Operate（運算指令）**：進行算術或邏輯資料處理（如 `ADD`, `AND`, `NOT`）。
2. **Data Movement（資料搬移指令）**：在暫存器與記憶體或 I/O 之間傳輸資料（如 `LD`, `ST`, `LDR`）。
3. **Control（控制指令）**：改變程式的執行流程與 PC 指標（如 `BR`, `JMP`, `JSR`）。
---

### MIPS Architecture: Instruction Types (指令格式) 
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e83a78f0-b7f9-4cd3-b7e6-6dd677925924" />

> **核心概念**：MIPS 屬於 RISC 架構，所有指令長度皆固定為 **32-bit**。為了簡化硬體解碼器的設計，MIPS 將所有指令歸類為三種主要格式：**R-type**（暫存器）、**I-type**（立即數）與 **J-type**（跳轉）。

---

#### 1. R-type (Register Format)
用於暫存器之間的算術與邏輯運算（如 `add`, `sub`, `and`）及位移操作。

| 欄位名稱 | opcode | rs | rt | rd | shamt | funct |
| :---: | :---: | :---: | :---: | :---: | :---: | :---: |
| **位元數** | 6 bits | 5 bits | 5 bits | 5 bits | 5 bits | 6 bits |

* **`opcode` (6 bits)**：固定為 `0`。
* **`rs` (5 bits)**：Source Register（第一個來源暫存器）。
* **`rt` (5 bits)**：Source Register（第二個來源暫存器）。
* **`rd` (5 bits)**：Destination Register（運算結果寫回的目的暫存器）。
* **`shamt` (5 bits)**：Shift Amount（位移量，非位移指令時為 0）。
* **`funct` (6 bits)**：Function Code（功能碼，當 `opcode = 0` 時，由此欄位指定具體的運算類型）。

---

#### 2. I-type (Immediate Format)
用於帶有常數（立即數）的運算、記憶體存取（`lw`, `sw`）及條件跳轉（`beq`, `bne`）。

| 欄位名稱 | opcode | rs | rt | immediate |
| :---: | :---: | :---: | :---: | :---: |
| **位元數** | 6 bits | 5 bits | 5 bits | 16 bits |

* **`opcode` (6 bits)**：指定操作碼（如 `addi`, `lw`, `sw` 等）。
* **`rs` (5 bits)**：Source Register（基底位址暫存器或第一個來源暫存器）。
* **`rt` (5 bits)**：Target Register（接收載入資料或運算結果的暫存器）。
* **`immediate` (16 bits)**：16 位元的常數數值或記憶體位址偏移量（Offset）。

---

#### 3. J-type (Jump Format)
用於無條件大範圍跳轉指令（如 `j`, `jal`）。

| 欄位名稱 | opcode | immediate |
| :---: | :---: | :---: |
| **位元數** | 6 bits | 26 bits |

* **`opcode` (6 bits)**：指定跳轉操作碼（如 `j`）。
* **`immediate` (26 bits)**：26 位元的目標記憶體跳轉位址（Target Address）。
---
### MIPS Architecture: R-Type Funct Field 
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/4e445ad4-0ce2-46d7-8165-98bf81e9e612" />

> **核心觀念**：
> * **`Opcode` 固定為 0 (`000000`)**：在 MIPS 的 R-Type 指令中，`opcode` 欄位並不代表具體運算功能。
> * **`Funct` 決定操作**：真正決定 CPU 執行何種運算（位移、跳轉、系統呼叫、乘除法等）的是 **`funct` 欄位**。

---
### Data Types & Architectural Tradeoffs 

> [!NOTE]
> **核心概念**：指令集架構（ISA）定義了 CPU 原生支援的資料型態（Data Types）。支援更多資料型態是**程式設計師 (Programmer)** 與 **微架構師 (Microarchitect)** 之間的權衡（Tradeoff）。

---

#### 常見 ISA 的資料型態支援對比
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/6b9149e5-fca0-4092-80c4-ff047e15ba4b" />

| ISA 架構 | 支援的資料型態 (Data Types) | 說明 / 數學公式 |
| :--- | :--- | :--- |
| **LC-3** | • **2's complement integers** *(二補數整數)* | 僅支援有號整數。<br>取負數（Negative）運算式：`X_neg = NOT(X) + 1` |
| **MIPS** | • **2's complement integers** *(二補數整數)*<br>• **Unsigned integers** *(無號整數)*<br>• **Floating point** *(浮點數)* | 支援多元型態，能直接進行無號數運算與浮點數算術。 |

---

#### 為何 ISA 需要不同的資料型態？ (Tradeoffs)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/381b8ffc-273b-41a6-9f85-b755de89646c" />

#### 1. 優點：對軟體/程式員有利 (Programmer Advantage)
* **更佳的高階語言映射**：硬體能直接處理高階程式語言中的資料結構，縮短軟體與硬體間的抽象差距。
* **減少指令數量與程式碼體積 (Code Size)**：
  * *矩陣運算*：單一專用指令即可完成，無需拆解為多條獨立的 `multiply` / `add` / `load` / `store` 指令。
  * *圖形運算*：原生支援複雜資料結構，避免大量基礎存取指令組合。

#### 2. 缺點：對硬體/微架構師不利 (Microarchitect Disadvantage)
* **大幅增加微架構設計工作量**：硬體工程師必須在晶片電路中實現支援這些資料型態的 ALU、暫存器與複雜控制邏輯。

---

#### 架構設計核心權衡總結

在設計 ISA 的資料型態時，主要考量以下兩項權衡：

1. **硬體複雜度 vs. 軟體複雜度 (Hardware vs. Software Complexity)**  
   * 支援更多型態 $\rightarrow$ 硬體變複雜，軟體/編譯器變簡單。  
   * 支援較少型態 $\rightarrow$ 硬體極簡，軟體需用多條基礎指令組合成複雜運算。
2. **運算延遲 (Latency of Operations)**  
   * **原生支援型態**：直接經由專用硬體電路執行，延遲低、速度快。  
   * **非原生支援型態**：需透過軟體演算法用多條指令模擬（如 LC-3 用軟體模擬浮點數），執行延遲極高。
---

### Data Types and Instruction Complexity (Semantic Gap) 筆記
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d544e7be-67f3-424b-bbbd-231f4569c262" />

> [!NOTE]
> **核心概念**：**語意隙縫（Semantic Gap）** 是指「CPU 指令與資料型態」和「高階程式語言（如 C++, Java, Python）」之間的抽象距離。資料型態的複雜度直接決定了指令集的語意層級（Semantic Level）。

---

#### 1. 語意隙縫 (Semantic Gap) 的分類對比

| 類型 | 小語意隙縫 (Small Semantic Gap) | 大語意隙縫 (Large Semantic Gap) |
| :--- | :--- | :--- |
| **指令與資料型態** | 複雜指令 + 複雜資料型態 | 簡單指令 + 簡單資料型態 |
| **硬體與高階語言關係** | 硬體指令極度貼合高階語言的操作邏輯，單一指令可完成高階數據結構動作。 | 硬體僅提供極簡基本功能，高階語言的複雜動作需由軟體/編譯器拆解成多條指令。 |
| **常見動作範例** | • 插入資料至雙向鏈結串列 (Doubly linked list)<br>• 矩陣相乘 (Multiply two matrices) | • 原始基礎運算：`load`, `store`, `add`, `multiply`, `nor` |
| **代表性 ISA / 架構** | **VAX ISA**<br>*(原生支援雙向鏈結串列、多維陣列指令)* | **Early RISC Machines**<br>*(早期 RISC 晶片僅原生支援整數型態與基礎操作)* |

---

#### 2. 觀念總結

* **CISC 哲學（小型 Semantic Gap）**：試圖縮小硬體與高階語言之間的距離，讓硬體做更多複雜的事，減輕編譯器負擔。
* **RISC 哲學（大型 Semantic Gap）**：保持硬體極簡與高執行效率，將複雜的語意轉換留給軟體與編譯器處理。
---
### Complex vs. Simple Instructions 筆記

> [!NOTE]
> **核心概念**：指令集架構設計的核心哲學在於「指令的粒度大小」。**複雜指令 (Complex Instruction)** 試圖單次完成大量工作；**精簡指令 (Simple Instruction)** 則提供最基礎的原生操作，由軟體組合出複雜功能。

---

#### 1. 複雜指令 vs. 精簡指令定義
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/494f418a-0c6c-437b-a313-4919378c2772" />

| 類型 | 特點說明 | 具體範例 |
| :--- | :--- | :--- |
| **Complex Instruction**<br>*(複雜指令)* | 單一指令可完成**大量工作與多個操作**（Does a lot of work）。 | • 插入資料至雙向鏈結串列 (`Insert in a doubly linked list`)<br>• 計算快速傅立葉變換 (`Compute FFT`)<br>• 字串複製 (`String copy`)<br>• 矩陣相乘 (`Matrix multiply`) |
| **Simple Instruction**<br>*(精簡指令)* | 單一指令僅完成**極少工作**（Does little work），作為構建複雜運算的基本原語（Primitive）。 | • 加法 (`Add`)<br>• 互斥或邏輯運算 (`XOR`)<br>• 乘法 (`Multiply`) |

---

#### 2. 複雜指令 + 資料型態的優缺點分析
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b380f473-1bb0-44d9-8087-e37b3c02f403" />

####  優點 (Advantages)
* **更緊密的編碼 (Denser encoding)** $\rightarrow$ **程式碼體積更小 (Smaller code size)**：
  * **提高記憶體利用率** (Better memory utilization)。
  * **節省晶片外頻寬** (Saves off-chip bandwidth)。
  * **提升快取命中率** (Better cache hit rate)。
* **簡化編譯器設計 (Simpler compiler)**：編譯器只需將高階語法對應至對應的複雜指令，不需花費大量精力進行微小指令層級的優化。

####  缺點 (Disadvantages)
* **限制編譯器的優化彈性 (Less optimization opportunity)**：
  * 由於指令封裝了較大區塊的工作（Larger chunks of work），編譯器無法進行精細粒度（Fine-grained）的指令重排與平行優化。
* **大幅增加硬體複雜度 (More complex hardware)**：
  * 將高階語意解碼並轉換為底層控制訊號（Control signals）的重擔全轉移至硬體，且硬體必須獨自承擔動態執行的優化責任。

#### Aside
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e10950c3-22a0-477a-9493-db2db70a65b5" />
---
# ISA Concepts: Addressing Modes (尋址模式) 筆記

> [!NOTE]
> **核心概念**：**尋址模式（Addressing Mode）** 是 CPU 指令用來**指定運算元（Operand）存放位置**的機制。不同的尋址模式決定了資料是如何被尋找與讀取的（從指令內部、暫存器，或是記憶體中）。

---

### LC-3 與 MIPS 的尋址模式比較

#### LC-3 支援的 5 種尋址模式
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/596c839c-5285-484a-8227-70ab29db183d" />

1. **Immediate / Literal (立即數/常數)**：運算元直接包含在指令本身的位元段中。
2. **Register (暫存器)**：運算元儲存於通用暫存器（`R0` ~ `R7`）中。
3. **Memory Addressing (記憶體尋址，包含 3 種)**：
   * **PC-relative (PC 相對尋址)**：以 PC 當前位址加上 Offset 算出記憶體位址。
   * **Indirect (間接尋址)**：指令指向的記憶體位址中，存放著「真正的目標位址」。
   * **Base+offset (基底加偏移量)**：指定基底暫存器加上 Offset 算出記憶體位址。

#### MIPS 的尋址模式特性
* 額外支援 **Pseudo-direct addressing (偽直接尋址)**：專門用於無條件跳轉指令（`j` 與 `jal`）。
* **不支援** Indirect addressing (間接尋址)：為了保持硬體設計簡單，避免多次存取記憶體。

---

#### 為何需要不同的尋址模式？ (Tradeoffs)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/298c79dd-fd0b-4706-8b0e-0c2131d1d262" />

提供多元尋址模式是 **程式設計師 (Programmer)** 與 **微架構師 (Microarchitect)** 之間的權衡：

#### 1. 優點：對軟體/程式員有利
* **更佳的高階語言映射**：某些資料結構的操作透過特定的尋址模式表達更為自然直覺。
* **減少指令數量與程式碼體積 (Reduced Code Size)**：
  * **一維/多維陣列索引 (Array indexing)**
  * **指標式存取 (Pointer-based / Indirection)**
  * **矩陣與稀疏矩陣元素索引 (Matrix & Sparse matrix indexing)**

#### 2. 缺點：對硬體與編譯器不利
* **增加微架構師工作量**：硬體電路必須加入更多算術單元（如 Adder）與多工器（MUX）來計算複雜位址。
* **增加編譯器決策複雜度**：編譯器有太多尋址選擇，需要花費更多運算來決定最優化的指令組合。

---

##### 尋址模式與語意隙縫 (Semantic Gap)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/547a453b-a740-4768-8a72-5c4561ce5a31" />

| 語意隙縫類型 | 尋址模式特性 | 特點 |
| :--- | :--- | :--- |
| **Small Semantic Gap** *(小語意隙縫)* | 複雜指令 + 複雜型態 + **多元尋址模式** | 貼近高階語言語法（如直接支援指標間接存取），但硬體控制邏輯變得非常複雜。 |
| **Large Semantic Gap** *(大語意隙縫)* | 精簡指令 + 簡單型態 + **精簡尋址模式** | 距離高階語言較遠，高階指標操作需拆成多條基礎指令，但極度貼近底層硬體控制訊號。 |
---

### LC-3 & MIPS: Operate Instructions (運算指令)
<img width="961" height="717" alt="image" src="https://github.com/user-attachments/assets/e37551bb-00e2-475e-a7e6-c9a80b843c55" />

> [!NOTE]
> **核心概念**：**運算指令（Operate Instructions）** 用於對資料進行算術或邏輯運算。不同架構在運算指令的豐富度上差異顯著：**LC-3** 僅提供 3 種最基本的運算指令，而 **MIPS** 則提供豐富的 R-type、I-type 以及浮點數（F-type）運算指令。

---

#### LC-3 的運算指令 (僅 3 種)

LC-3 的運算指令極為精簡，僅包含單元運算與二元運算：

| 指令 | 操作類型 (Operation Type) | 來源運算元數量 | 說明與邏輯 |
| :---: | :---: | :---: | :--- |
| **`NOT`** | **Unary** *(單元運算)* | 1 個 | 執行位元反轉 (Bitwise NOT)。 |
| **`ADD`** | **Binary** *(二元運算)* | 2 個 | 執行二補數加法 (2's complement addition)。 |
| **`AND`** | **Binary** *(二元運算)* | 2 個 | 執行位元及運算 (Bitwise AND，即 `SR1 & SR2`)。 |

---

#### MIPS 的運算指令 (多樣化支援)

相較於 LC-3，MIPS 提供更全面且豐富的運算指令種類：

* **R-type 運算指令** *(二元運算)*：
  * 支援多種暫存器之間的算術與邏輯運算，例如 `add`, `and`, `nor`, `xor` 等。
* **I-type 運算指令** *(立即數版本)*：
  * 為 R-type 指令對應的立即數變體，其中一個來源運算元為指令內嵌的常數（Immediate Operand），例如 `addi`, `andi`, `xori` 等。
* **F-type 運算指令** *(浮點數運算)*：
  * 專門用於處理浮點數算術（Floating-point operations）。

---

#### LC-3 vs. MIPS 運算指令對比

| 對比面向 | LC-3 | MIPS |
| :--- | :--- | :--- |
| **運算指令數量** | 極少（僅 3 種：`ADD`, `AND`, `NOT`） | 豐富（涵蓋多種算術、邏輯、位移與比較） |
| **立即數支援 (Immediate)** | `ADD` 與 `AND` 可帶 5-bit 立即數 | 提供完整專屬的 I-type 立即數指令 (16-bit) |
| **浮點數支援 (Floating Point)** |  無（需透過軟體演算法模擬） |  原生支援（專屬 F-type 浮點數指令集） |
---

### LC-3 Architecture: Immediate Mode Operations (ADD & AND) 

> [!NOTE]
> **核心概念**：LC-3 的運算指令（`ADD` 與 `AND`）支援**立即數模式 (Immediate Mode / Literal)**。透過將指令的 **Bit[5] 設為 `1`**，運算元可以直接取用指令內含的 5 位元常數（`imm5`），不需再存取第二個暫存器。`imm5` 必須先經過**符號擴充 (Sign-Extension, SEXT)** 轉為 16-bit 後方能送入 ALU 計算。

---

#### 指令格式 (16-bit Instruction Format)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/585b4b8a-712c-47dd-a625-60918d9d8d03" />

| 欄位名稱 | OP (Opcode) | DR (Destination) | SR1 (Source 1) | Mode Flag | imm5 (Literal) |
| :---: | :---: | :---: | :---: | :---: | :---: |
| **位元範圍** | Bit [15:12] | Bit [11:9] | Bit [8:6] | Bit [5] | Bit [4:0] |
| **寬度** | 4 bits | 3 bits | 3 bits | 1 bit | 5 bits |
| **說明** | 操作碼 (`0000`~`1111`) | 目的暫存器 (`R0`~`R7`) | 第一來源暫存器 | **固定為 `1`** | 5-bit 二補數常數 |

---

#### 支援指令與運算邏輯

* **`ADD` (Opcode = `0001`)**：
  * **微操作邏輯**：$\text{DR} \leftarrow \text{SR1} + \text{sign-extend}(\text{imm5})$
* **`AND` (Opcode = `0101`)**：
  * **微操作邏輯**：$\text{DR} \leftarrow \text{SR1} \text{ AND } \text{sign-extend}(\text{imm5})$

---

#### 實例解析：`ADD R1, R4, #-2`
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/1ab7af3a-efd5-4ce3-bab1-512d9f33540d" />

#### 機器碼轉換 (Machine Code Breakdown)

| 欄位 | OP | DR | SR1 | Flag | imm5 |
| :--- | :---: | :---: | :---: | :---: | :---: |
| **語意** | `ADD` | `R1` | `R4` | 立即數模式 | `-2` |
| **十進位/符號** | 1 | 1 | 4 | 1 | -2 |
| **二進位機器碼** | `0001` | `001` | `100` | `1` | `11110` |

* **完整 16-bit 機器碼**：`0001 001 100 1 11110`

---

#### 硬體資料路徑 (Datapath Execution Flow)

1. **符號擴充 (SEXT)**：`imm5` 數值 `11110` (-2) 經由 SEXT 電路擴充成 16-bit 的 `1111111111111110`。
2. **多工器選擇 (MUX Selection)**：Bit[5] 為 `1`，訊號控制 MUX 切換至 `1` 號通道，選擇將擴充後的立即數送入 ALU 的 B 端輸入。
3. **ALU 計算**：
   * **Input A**：從 Register File 讀取 `R4` 的值。
   * **Input B**：16-bit 符號擴充後的 `-2`。
   * **Operation**：ALU 執行加法運算。
4. **結果寫回 (Writeback)**：ALU 運算結果寫回 Register File 中的指定目的暫存器 `R1` (DR)。
---

### Instructions with One Literal in MIPS（I-type 指令）

#### 格式
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f34342fc-4ae4-49e4-aa22-4f61bac70d91" />

I-type 指令包含 2 個暫存器運算元 + 1 個立即值（immediate）。

| 欄位   | opcode | rs    | rt    | imm    |
|--------|--------|-------|-------|--------|
| 位元數 | 6 bits | 5 bits| 5 bits| 16 bits|

- **opcode**：運算類型（operation）
- **rs**：來源暫存器（source register）
- **rt**：
  - 在部分指令中是**目的暫存器**（如 `addi`, `lw`）
  - 在部分指令中是**來源暫存器**（如 `sw`）
- **imm**：立即值 / literal

---

#### 範例：ADD Immediate（addi）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e9e4763f-c0ba-423b-931c-b76fea712c50" />

**組合語言：**
```asm
addi $s0, $s1, 5
```

**運算語意：** rt ← rs + sign-extend(imm)

#### 解析對照
- `addi` 的 opcode = `8` → 二進位 `001000`
- `$s1` = 暫存器 17 → `10001`
- `$s0` = 暫存器 16 → `10010`
- 立即值 `5` → 16-bit sign-extend → `0000 0000 0000 0101`
---
### MIPS vs. LC-3 減法
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/98df4c95-05a7-4a97-ad63-859cbe0a22dc" />

#### 減法指令的有無

| 架構 | SUB 指令 | 減法立即值指令 |
|------|----------|----------------|
| MIPS |  有 `sub` |  無 `subi`（不需要） |
| LC-3 |  無 |  無 |

#### 各架構如何做減法

**MIPS**：直接用 `sub` 指令
```asm
sub $s3, $t0, $s2
```

**LC-3**：沒有減法指令，靠「取二補數再相加」
```asm
NOT R4, R3        ; 先取反
ADD R5, R4, #1    ; 再+1 → 得到二補數
ADD R6, R2, R5    ; 相加 = 相減
```

#### 立即值減法怎麼辦（a = b - 3）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/8856abbc-cb0b-454a-b4e5-058648e42cc1" />


兩者都不需要額外的減法立即值指令，直接用**加法指令 + 負數**：

- MIPS：`addi $s1, $s0, -3`
- LC-3：`ADD R1, R0, #-3`

#### 核心觀念

- **MIPS**：有 sub，但省略 subi，因為 addi 的立即值本身可正可負
- **LC-3**：連 sub 都省略，用 NOT + ADD #1 組出二補數
- **共同設計哲學**：硬體只需要「加法器」，減法用二補數轉換即可完成 → 簡化控制邏輯，代價是指令數變多（尤其 LC-3）
---
### Data Movement Instructions
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/f515f61f-ecfc-41a1-9a42-70de57219bea" />

#### LC-3 資料搬移指令
LC-3 共有七種資料搬移指令：
```
LD, LDR, LDI, LEA, ST, STR, STI
```

#### Load / Store 指令格式

| 欄位 | 位元範圍 |
|------|----------|
| Opcode | [15:12] |
| DR 或 SR | [11:9] |
| Address generation bits | [8:0] |

**四種定址模式（Addressing Modes）**：
1. PC-Relative Mode
2. Indirect Mode
3. Base+Offset Mode
4. Immediate Mode

#### MIPS 對照
MIPS 的 load/store 指令只有兩種定址模式：
- Base + offset
- Immediate

---
### Base+Offset 與 Immediate Mode 

#### Base+Offset Mode（LDR/STR）
- 語意：`DR ← Memory[BaseR + sign-extend(offset6)]`
- 跟 PC-Relative 的差別：基準點是**暫存器**而非 PC，所以能指向記憶體中任何位置
- **MIPS 的 `lw`/`sw` 就是同一種模式**，這是 LC-3 與 MIPS 唯一共通的定址方式

#### Immediate Mode（LEA）
- 語意：`DR ← PC + sign-extend(PCoffset9)`
- 跟 PC-Relative（LD）長得很像，但**關鍵差異：LEA 不存取記憶體**，只是把算出來的位址本身存進暫存器（所以叫 Load *Effective Address*）
- MIPS 沒有 LEA，而是用 `lui` + `ori` 組出 32-bit 常數

---

#### 四種定址模式總表（核心重點）

| 定址模式 | 指令 | 基準 | 讀記憶體次數 |
|----------|------|------|--------------|
| PC-Relative | LD/ST | PC | 1 |
| Indirect | LDI/STI | PC → 再讀一次 | 2 |
| Base+Offset | LDR/STR | 暫存器 | 1 |
| Immediate | LEA | PC | 0（只算位址） |

**重點結論**：MIPS 只留 Base+Offset 和 Immediate 兩種，捨棄 PC-Relative 和 Indirect —— 呼應 RISC「精簡指令、用多道指令組合出複雜功能」的設計哲學。
---

### Control Flow Instructions 重點
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/c9de9077-d218-4d90-a4c3-b3a9f7e99ed3" />

- 功能：讓程式可以**不按順序執行**（out of sequence）
- 分兩大類：**條件分支（Conditional branches）**、**無條件跳躍（Unconditional jumps）**

#### 條件分支
- 用途：做決策（例如 if-else）
- LC-3 用**三個 condition codes** 來實現

#### 跳躍（Jumps）
- 用途：實作 **迴圈（Loops）** 與 **函式呼叫（Function calls）**
- 對應指令：LC-3 的 `JMP`、MIPS 的 `j`
---

### Conditional Control Flow（Conditional Branching）

#### 1. Condition Codes（LC-3 獨有機制）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/0188304f-7c29-416c-a2c7-7be7945d2b5f" />

- 每次寫入任何 GPR（R0-R7）時，會自動更新 3 個單一位元的 condition code：**N（負）、Z（零）、P（正）**
- 三者互斥，同時只會有一個被 set：
  - 寫入值 < 0 → N=1
  - 寫入值 = 0 → Z=1
  - 寫入值 > 0 → P=1
- **x86、SPARC** 也是使用 condition code 機制的例子（MIPS 沒有這個機制）

#### 2. LC-3 的條件分支：BR 系列
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/2a0e1264-95ba-440d-8502-3804ec1cce1f" />

- **n, z, p**（指令位元）：決定這次分支要「測試」哪些 condition code
- **N, Z, P**（實際狀態暫存器的值）：目前的條件狀態

**思考題（重點）：**
- `n=z=p=1`（即 `BRnzp`）→ 不管條件為何都成立 → **等同無條件跳躍**
- `n=z=p=0` → 沒有任何條件被測試 → **恆不跳躍（等同 no-op）**

#### 3. MIPS 的條件分支：beq（Branch if Equal）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/5273da99-0f4d-4cc7-a710-c8f3f1a29b3c" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/fe5db9fd-d0ac-4284-b274-4e125af65b5e" />

- 直接比較兩個暫存器：`rs == rt`
- `PC ← PC + sign-extend(offset) * 4`（乘 4，因為位址以 byte 為單位，指令固定 4 bytes）
- 變化：`beq, bne, blez, bgtz`

#### 4. LC-3 vs. MIPS 設計理念比較

| 比較項目 | LC-3 | MIPS |
|----------|------|------|
| 判斷依據 | 隱含的 condition code（N/Z/P） | 直接比較兩個暫存器 |
| 條件產生時機 | ALU 每次寫暫存器時自動更新 | 分支指令本身內建比較邏輯 |
| 額外硬體需求 | 需要 3 個狀態暫存器並隨時同步更新 | 不需要額外狀態，但分支指令要做比較運算 |

**核心結論**：LC-3 用「隱式狀態（condition codes）」做分支判斷，MIPS 用「顯式比較（直接比較兩暫存器）」——這是 ISA 設計哲學的又一次體現，也是許多現代 ISA（如 RISC-V）選擇捨棄 condition code 機制的原因之一。
---


[回目錄](#toc)

---
<a id="m09d16"></a>

## 2026 年 9 月 16 日

## 今日進度：
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L9](https://www.youtube.com/watch?v=l8KpCtprJpc&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=11)


## 關鍵知識/詞彙：
### How to Change the Semantic Gap Tradeoffs
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e2ca1fd4-76f2-4023-adcc-1e6d3c9f2788" />

#### 核心概念與階層架構
* **核心策略**：Translate from one ISA into a different "implementation" ISA（將源 ISA 轉譯為不同的實作 ISA）。
* **HLL (High-Level Language)**：高階程式語言層。
* **X86-64 (複雜 ISA)**：
  * 包含複雜指令（Complex Inst）、資料型別與定址模式。
  * 與 HLL 之間的語意落差較小 (**Small Semantic Gap**)。
* **Software or Hardware Translator (軟體或硬體轉譯器)**：位於兩層 ISA 之間，負責將複雜指令轉換為簡化指令。
* **ARM v8.4 (Implementation ISA / 實作 ISA)**：
  * 採用簡化的指令、資料型別與定址模式。
* **HW Control Signals (硬體控制訊號)**：最底層，直接驅動硬體運作的控制訊號。

#### Example
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/86231892-35d9-4937-9236-b7a7ad052f55" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/538a1bb2-c359-4ef9-af92-b159d433ab45" />

#### 1. 核心機制與 DCO 任務

* **設計理念**：放棄傳統複雜的硬體亂序執行（Out-of-Order）設計，採用大型順序執行（In-Order）核心，並將指令排列與優化的重任交給軟體層。
* **Dynamic Code Optimizer (DCO)**：軟體層的核心推手，主要執行兩大任務：
    * **指令轉譯**：將 ARM 指令集轉譯為 Denver 本地的原生格式（Native Format）。
    * **程式碼最佳化**：挖掘單一執行緒中的指令級平行度（ILP），並重新排列指令以避開硬體停頓（Stalls）。

#### 2. 動態最佳化流程與技術 (Optimize Once, Use Many Times)

* **運作機制**：硬體解碼器與執行單元收集動態輪廓資訊（Dynamic Profile Information），送交 Optimizer 生成最佳化微碼（Optimized µcode），並快取於 **Optimization Cache** 以供重複調用。
* **主要優化技術**：
      * **迴圈展開**（Unrolls Loops）與**暫存器重命名**（Renames registers）
      * **載入與儲存重排**（Reorders Loads and Stores）
      * **改善控制流程**（Improves control flow）
      * **移除無用計算**（Removes unused computation）
      * **提昇冗餘計算**（Hoists redundant computation）與**下移罕見執行計算**（Sinks uncommonly executed computation）
      * **改善指令排程**（Improves scheduling）
---
### Principle: Indirection
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/2854a977-ba74-4f16-8d72-bd84e3958d21" />

#### 核心概念與權衡

* **經典名言**：「計算機科學中的任何問題，都可以透過增加另一個間接層來解決。」（"Any problem in computer science can be solved with another level of indirection."）
  * **提出者**：David Wheeler（引用自 Butler Lampson 的 *"Principles for Computer Systems Design"*）
* **主要優勢**：引進間接層後，系統設計的權衡關係將被改變，並能開啟新的功能與架構可能性。
* **主要代價**：間接性會帶來額外的**複雜度（Complexity）**與**延遲（Latency）**。
* **後續應用**：此原則將在後續討論**虛擬記憶體（Virtual Memory）**時再次出現。

---
### ISA-level Tradeoffs: Number of Registers
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/aae92f1d-6457-4b79-a2fc-2fe8db4dc07b" />

#### 影響層面 (Affects)

* **位址編碼**：編碼暫存器位址所需的位元數（Bits）。
* **高速儲存容量**：能同時保留在高速儲存區（Register File）中的數值數量。
* **微架構成本**：暫存器檔案（Register File）的實體大小、存取時間（Access Time）與功耗（Power Consumption）。

#### 暫存器數量多的優缺點 (Large number of registers)

* **優點 (+)**：
  * 允許編譯器進行更佳的**暫存器分配（Register Allocation）**與優化，進而減少記憶體存取（Fewer saves/restores）。
* **缺點 (-)**：
  * **指令長度變大**（Larger instruction size）。
  * **暫存器檔案尺寸變大**（Larger register file size）。

* **案例對比**：此權衡關係先前已在 **LC-3 vs MIPS** 的比較中展現。
  
---
### 馮紐曼架構 vs. 資料流模型（Dataflow Model）

#### 1. 核心執行機制對比
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a516b309-2cb3-4a53-9b4a-60ad9e08c2df" />

* **馮紐曼模型（Von Neumann Model）**
  * **控制流驅動（Control Flow）**：指令執行嚴格依循 **程式計數器（Program Counter, PC）** 的定序。除非遭遇轉移指令，否則預設為單線順序執行。
  * **狀態隱喻**：將程式視為一連串對記憶體位置進行讀寫與改寫的狀態轉移過程。

* **資料流模型（Dataflow Model）**
  * **資料流驅動（Data Flow）**：**完全取消 PC** 的概念。指令的觸發（Fire）純粹取決於「所需運算元（Operands）是否已全部到位」。
  * **相依性導向**：指令不關心執行順序，僅宣告計算結果要傳送給誰。只要資料相依性滿足，該節點即可立即運算，本質上具備極高的指令級平行度（ILP）。

---

#### 2. 計算流程範例解析
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/0218847e-0e22-48a8-915b-d682afd7353c" />

以計算式 `z = (a + b - b * 2) * (a + b + b * 2)` 為例：

* **順序執行邏輯（馮紐曼）**：
  必須被強制拆解為 5 個有嚴格前後順序的步驟：`v = a + b` $\rightarrow$ `w = b * 2` $\rightarrow$ `x = v - w` $\rightarrow$ `y = v + w` $\rightarrow$ `z = x * y`。即便部分步驟彼此獨立，受限於單線 PC，硬體仍被迫按順序擷取與執行。
* **圖形執行邏輯（資料流）**：
  將計算表達為**有向無環圖（DAG）**：
  * **Stage 1（無相依）**：`a + b` 與 `b * 2` 可同時並行計算。
  * **Stage 2（相依於 Stage 1）**：`v - w` 與 `v + w` 可同時並行計算。
  * **Stage 3（相依於 Stage 2）**：執行最後的乘法產出 `z`。

---

#### 3. 架構權衡與現代處理器啟示

* **程式設計直覺**：馮紐曼模型貼近人類的步驟式思維（Mental Model），變數與指令順序易於除錯與追蹤；資料流模型雖然最符合數學邏輯，但對於大型軟體開發與狀態管理極為抽象。
* **硬體實作成本**：純 Dataflow 架構需要昂貴的資料比對與派發機制（Token Matching），維護資料傳送網路的複雜度過高。
* **現代微架構折衷**：現代高效能 CPU（如 Out-of-Order 亂序執行核心）本質上是**「上層介面呈現馮紐曼 ISA，底層微架構以 Dataflow 方式執行」**的混合體，藉此兼具軟體相容性與硬體平行度。

---
### 資料流架構（Dataflow Architecture）

#### 1. 節點觸發與 ISA 指令格式設計
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/9be297f0-264a-4718-b11d-1a1ad69c58f1" />

* **Token 驅動（Token-Driven）**：資料流節點（Node）不依賴 PC 定序，僅在所有輸入端均收到 **Token**（代表運算元 Ready）時被觸發（Fire）並執行。
* **反向定址（Push-based Routing）**：
  * **傳統 ISA**：指令指定「從哪裡（暫存器/記憶體）讀取輸入」。
  * **Dataflow ISA**：格式包含 `[Opcode | Ready Bit | Argument | Dest. Of Result]`。計算結果不存回暫存器，而是直接 **Push（推送）** 到後續目標指令的輸入欄位中。

---

#### 2. 資料流程式邏輯分析
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/7b4e6a1d-97ed-439a-b457-5addf0adc82e" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/aac42ea6-e257-4a45-a98f-091cb9a6ca27" />

* **控制流的資料化**：資料流架構沒有傳統的分支指令（Jump/Branch），而是利用 **Branch 節點（BR）** 結合布林值 Token 來導向資料（True 走迴圈，False 走輸出）。
* **圖形執行流程（以輸入 $N$ 與初始值 $1$ 為例）**：
  1. **條件判斷**：檢查目前 $N$ 是否 $> 0$，產生 Bool Token 送入 BR 節點。
  2. **迴圈疊代（$N > 0$）**：當判斷為 True，將累乘值與 $N$ 送入乘法器（`*`），同時對 $N$ 進行減一操作（`DEC`），結果重新迴送至輸入端。
  3. **終止輸出（$N \le 0$）**：當判斷為 False，BR 節點將最終累乘結果導向 `OUT`。
* **演算法解析**：此資料流圖實現的是 **階乘計算（Factorial）**，故 `OUT` 的數值為 **$N!$**（當 $N=0$ 時輸出 $1$）。

---

#### 3. 硬體實作挑戰與權衡

* **Token Matching 開銷**：硬體必須建立動態匹配儲存器（Matching Store）來比對並集齊不同指令所需的 Token。當程式規模放大時，Token 匹配與搜尋的開銷會急劇膨脹。
* **資料複製與路由成本**：為了將同一份資料傳給多個不同節點，必須顯式引入 **Copy 節點**，這會產生額外的指令與傳輸開銷。

---
### ISA 階層設計與微架構（Microarchitecture）解耦權衡

#### 1. ISA 階層的抉擇：是否引入程式計數器（PC）？
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/470c526d-f977-4077-9f01-8bcd3155c47d" />

* **有 PC（Control-Driven / 順序執行）**
  * **機制**：指令由 PC 定序，預設順序遞增執行。
  * **優勢**：開發直覺，編譯器設計相對簡單，除錯與狀態追蹤容易。
  * **劣勢**：強加了順序限制，隱蔽了潛在的指令級平行度（ILP）。

* **無 PC（Data-Driven / 資料流執行）**
  * **機制**：取消 PC，指令僅在運算元 Ready 時自動觸發。
  * **優勢**：極大化平行度擷取（Parallelism Extraction）。
  * **劣勢**：軟體維護困難、狀態不易追蹤，硬體 Token Matching 複雜度過高。

---

#### 2. 四大維度架構權衡（High-Level Tradeoffs）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/0338921f-0859-46e2-96dc-82cc8e8e6249" />

選擇 Control-Driven 或 Data-Driven 必須評估以下關鍵指標：

| 評估維度 | Control-Driven (有 PC) | Data-Driven (無 PC) |
| :--- | :--- | :--- |
| **程式設計難易度** | 高（符合傳統步驟式思維） | 低（複雜的狀態與資料流追蹤） |
| **編譯器開發難易度** | 低（對應傳統語法架構） | 高（需拆解為複雜數據流圖） |
| **平行度擷取能力** | 低（受限於單線 PC） | 極高（本質並行） |
| **硬體控制複雜度** | 低（簡單 Fetch/Decode） | 高（需要動態 Token 匹配機制） |

---

#### 3. 核心觀念：ISA 契約與微架構實作的解耦

* **ISA 層（Programmer-Visible Contract）**：
  * 定義了**「軟體視角看到的執行順序」**。若 ISA 承諾的是順序模型，程式員只需假設指令是依序執行的。
* **微架構層（Underlying Implementation）**：
  * 決定**「硬體實際上的執行機制」**。
* **微架構黃金法則（Sequential Illusion）**：
  微架構可以用**任何順序**（如以 Dataflow 方式進行 Out-of-Order 亂序執行）來處理指令；只要在將結果提交並更新至軟體可見的狀態時（State Commitment），**嚴格維持 ISA 承諾的語意順序**即可。

---
### 現代馮紐曼抽象與「電腦架構」定義演進技術

#### 1. 現代處理器中的馮紐曼模型：介面與實作的解耦
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/ad46829f-451c-49b2-b118-5ae4428d2bbd" />

* **介面層（ISA）的統一**：幾乎所有現代主流 ISA（如 x86、ARM、MIPS、RISC-V、POWER 等）在對外呈現的軟體介面上均採用馮紐曼模型。
* **實作層（Microarchitecture）的演進**：微架構底層運作早已偏離傳統馮紐曼模型的單線順序執行，關鍵演進包含：
  * **流水線化（Pipelining）**：如 Intel 80486，將指令執行階段重疊。
  * **多指令並行（Superscalar）**：如 Intel Pentium，單週期可發射多條指令。
  * **亂序執行（Out-of-Order Execution）**：如 Intel Pentium Pro，打破程式順序以極大化平行度。
  * **獨立 Cache 架構**：採用分離的指令與資料快取（具備哈佛架構特徵）以消除記憶體存取瓶頸。
* **核心價值（Abstraction Barrier）**：底層所有非馮紐曼模型的運作細節皆對軟體**完全隱蔽**，成功讓軟體享有簡單的順序程式設計模型，同時硬體獲得極致的執行效能。

---

#### 2. 「電腦架構（Computer Architecture）」定義的範疇演進
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/26d76dea-4395-4621-8760-a1c225354b2f" />

* **傳統定義（狹義 / ISA-Only，Gene Amdahl, 1964）**
  * **定義範疇**：僅涵蓋「程式員所能看到的系統屬性（Conceptual Structure & Functional Behavior）」。
  * **核心概念**：將介面規範與底層的資料流組織、控制邏輯及實體硬體實作明確劃分開來。

* **現代定義（廣義 / ISA + Implementation）**
  * **定義範疇**：結合軟硬體介面設計（ISA）與硬體組件的選擇、互連與優化實作。
  * **核心目標**：電腦架構是一門平衡的科學與藝術，旨在系統性地滿足**功能（Functional）**、**效能（Performance）**、**功耗（Energy Consumption）**與**成本（Cost）**等多維度工程目標。

---
### 微架構（Microarchitecture）與 ISA 關係深層解析

#### 1. 微架構的本質與「一線多實作」
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/97093bed-9ea6-4ed0-acce-3159ec918e8f" />

* **微架構（$\mu$arch）定義**：ISA 是軟硬體的協定與抽象介面，而微架構則是該介面在硬體電路上的**具體實作方式（Implementation）**。
* **一對多關係（One-to-Many Mapping）**：同一個 ISA 可以擁有無數種完全不同的微架構實作：
  * **x86 家族**：從早期的 Intel 80486、Pentium，到現代的 Golden Cove、Sapphire Rapids 以及 AMD Ryzen，全都執行同一套 x86 ISA，但內部的微架構設計已翻新數十代。
  * **ARM 家族**：包含注重省電的 Cortex-M 系列、高效能 Cortex-A 系列，以及 Apple 的 A 系列與 M 系列晶片、NVIDIA Denver 等。

---

#### 2. 「油門與引擎」類比：介面契約與實作自由度
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d0b0f563-2c7e-497f-9fc5-3bbd16c88cfd" />

* **直覺類比**：
  * **ISA（油門踏板）**：提供給駕駛（程式員/編譯器）的控制介面，定義「踩下踏板等於加速」的規範。
  * **微架構（引擎內部構造）**：實現「加速」的具體機械結構（如直列四缸、V8 雙渦輪、純電馬達）。駕駛不需要知道引擎如何運作，只需會踩油門。
* **實作自由度（Implementation Freedom）**：
  只要微架構嚴格遵守 ISA 所規範的結果與行為，硬體設計者擁有完全的自由度去替換底層電路。
  * **指令級範例**：ISA 僅定義 `ADD` 加法指令，但微架構可以選擇採用 **波紋進位加法器（Ripple Carry Adder）**、**先行進位加法器（Carry Lookahead Adder）** 或 **位元串列加法器（Bit Serial Adder）** 來實現。

---

#### 3. 核心思考：為什麼微架構的演進速度遠快於 ISA？

投影片提出了一個關鍵問題：**「市場上有極少的 ISA（x86, ARM, RISC-V），卻有數不清的微架構，為什麼？」**

* **1. 軟體生態與後向相容性（Software Compatibility）**
  * 修改 ISA 的成本極其昂貴，因為這意味著整個軟體生態系（編譯器、作業系統、所有應用程式）都需要重新編譯或重寫。為了維護數十年累積的軟體資產，ISA 必須保持高度穩定。
* **2. 半導體技術與物理極限的驅動（Hardware Technology Scaling）**
  * 摩爾定律與製程演進（如 7nm $\rightarrow$ 3nm）讓電晶體預算大幅增加，硬體設計者必須持續推出新的微架構（如引入流水線、多指令發射、亂序執行、分支預測器）來將物理資源轉化為實際效能。
* **3. 市場分眾與權衡需求（Trade-off Diversity）**
  * 同一個 ISA 需要覆蓋從「毫瓦級嵌入式裝置」到「百萬瓦級超級電腦」的需求。設計者透過調整微架構（如順序執行 vs. 亂序執行、快取大小、管線深度），可在功耗、成本與效能之間做出最佳權衡，而無須改變軟體層面的 ISA。

---
### 微架構範疇與 ISA 屬性判別技術

#### 1. 微架構的核心邊界與技術範疇
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/53a2052e-9738-4d8b-9ccd-4fe945d65027" />

* **微架構邊界原則**：凡是**「在硬體層級實作、且對上層軟體完全透明（Transparent to Software）」**的設計，均屬於微架構範疇。
* **微架構涵蓋的關鍵技術**：
  * **執行與平行度優化**：流水線（Pipelining）、順序/亂序執行（In-order vs. Out-of-order）、超純量（Superscalar）多指令發射、投機執行（Speculative Execution）。
  * **記憶體子系統**：快取架構設計（層級、容量、組相聯度、替換策略）、資料預擷取（Prefetching）、記憶體存取調度策略。
  * **能耗與可靠度管理**：時脈門控（Clock Gating）、動態電壓/頻率調整（DVFS）、硬體除錯與錯誤修正（ECC/Error Correction）。

---

#### 2. ISA vs. 微架構（$\mu$arch）屬性判別對照表
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/657666ce-652e-4f0c-b185-c9beedbd2d39" />

理解兩者區分的關鍵在於：**「軟體/程式員是否能直接感知或存取該屬性？」**

| 屬性項目 | 歸屬層級 | 判別說明與理由 |
| :--- | :--- | :--- |
| **ADD 指令的 Opcode** | **ISA** | 軟體/編譯器必須精確知道機器碼格式才能產生可執行的二進位檔案。 |
| **ALU 加法器類型**<br>*(Bit-serial / Ripple-carry / CLA)* | **微架構** | 硬體邏輯閘的實現方式，完全不影響軟體執行的邏輯結果。 |
| **通用暫存器數量** | **ISA** | 暫存器名稱與數量（如 $R_0 \sim R_{31}$）會直接暴露在組合語言中供程式員使用。 |
| **MUL 指令執行的 Clock Cycles 數** | **微架構** | 指令執行所需的時間週期屬於硬體效能實作細節，不影響 ISA 語意。 |
| **暫存器檔案的 Ports 數量** | **微架構** | 暫存器檔案（Register File）開了幾個 Read/Write Ports 是硬體並行讀取的設計。 |
| **是否採用流水線執行（Pipelining）** | **微架構** | 流水線重疊執行指令的過程對程式員隱蔽，軟體看到的仍是指令逐條生效。 |
| **程式計數器（Program Counter, PC）** | **ISA** | PC 代表系統當前的控制狀態，可被分支指令修改或被除錯器（Debugger）讀取。 |

---

#### 3. 設計約束與目標（Design Constraints & Goals）

* **微架構的核心任務**：微架構並非獨立存在，而是工程師在特定的 **PPA（Performance, Power, Area / 效能、功耗、面積）** 與成本/可靠度約束下，實現 ISA 規範的最佳化解法。
* **解耦的效益**：正因為微架構能將流水線、快取與亂序執行等複雜技術隱藏在 ISA 介面之下，處理器廠商才能在不破壞舊有軟體生態的情況下，持續透過微架構創新提升晶片效能。

---
### 設計點（Design Point）與權衡決策
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/15e714c0-d2c7-480f-aca2-b8235a8a254f" />

* **核心定義**：由「問題空間（Application Space）」與「目標市場/使用者」所決定的一組設計考量與優先順序，直接主導 ISA 與微架構層面的權衡（Trade-offs）。
* **多維度評估指標**：
  * **效能與能耗**：算力效能（Performance）、峰值功耗/散熱限制（Thermal）、能量效率與續航（Energy/Battery Life）。
  * **成本與時程**：晶片開發與製造成本（Cost）、產品上市時間（Time to Market）。
  * **品質與安全**：系統可用性（Availability）、可靠度與正確性（Reliability & Correctness）、安全性與可預測性（Security & Predictability）。

---

### 電腦架構的「藝術」本質（Why Is It Art?）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/494d8d4d-19fd-4f99-8c85-627f2af45386" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a2227e51-e513-40c6-8620-c231e7a04d5c" />

* **樞紐定位**：架構師位於軟硬體抽象層級（Stack）的核心交會點（ISA & Microarchitecture），負責銜接上層應用與底層硬體。
* **非確定性決策**：未來的軟體應用、市場趨勢與物理製程皆處於持續變動且無法完全預知的狀態，無法單靠公式導出唯一解答，需要前瞻性的權衡判斷。

---

### 架構師的雙向前瞻觀照機制（Look Up & Down, Forward）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/e248cc8b-8470-477b-a281-6c90536c076c" />

* **Look Up and Forward（向上前瞻）**：
  * **目標**：持續觀察並預測上層軟體與使用者側的動態演變。
  * **範疇**：新興演算法、程式語言、執行時期系統（Runtime System）、應用問題空間以及使用者行為特質的改變。
* **Look Down and Forward（向下前瞻）**：
  * **目標**：持續掌握並預測底層硬體物理極限與新技術發展。
  * **範疇**：邏輯設計（Logic）、電路結構（Circuits）、物理電子特性（Electrons）的新能力與限制。

---
### 機器指令處理與狀態轉換機制技術

#### 1. ISA 視角的指令處理：抽象有限狀態機（Abstract FSM）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/040dce08-2332-4e86-901f-bbc2bc18f88b" />

* **狀態轉換公式**：指令執行的本質即為結構狀態的轉移 $AS \rightarrow AS'$。
  * **$AS$ (Architectural State)**：指令執行前「軟體/程式員可見」的系統狀態（如暫存器、PC、記憶體內容）。
  * **$AS'$ (Architectural State')**：指令執行完成後「軟體/程式員可見」的新狀態。
* **原子性與單次躍遷（Atomic & Single Transition）**：
  * 在 ISA 的抽象定義中，指令執行具備**原子性**，不存在任何「中間狀態（Intermediate States）」。
  * 軟體視角下，每執行一條指令僅發生一次狀態轉移。

---

#### 2. 微架構視角的實作：微架構狀態（Microarchitectural State, MS）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/7b7ee914-5ab8-4c08-974f-1709f820b91d" />

* **解耦與效能優化**：微架構負責實現 $AS$ 如何轉變為 $AS'$，為了極大化執行速度，硬體可自由引入軟體不可見的**微架構狀態（MS）**。
* **狀態轉移策略選擇**：
  * **單週期模型（Single-Cycle）**：硬體於單一 Clock Cycle 內直接完成 $AS \rightarrow AS'$ 轉換。
  * **多週期/流水線模型（Multi-Cycle / Pipelined）**：指令執行跨越多個 Clock Cycles，歷經一系列內部狀態轉移（$AS \rightarrow AS+MS_1 \rightarrow AS+MS_2 \dots \rightarrow AS'$），最後才正式 Commit 至 $AS'$。
* **關鍵約束**：無論硬體內部經過多複雜的中間狀態（$MS$），最終提交的結果必須嚴格契合 ISA 規範所定義的 $AS'$ 語意。

---
### 單週期指令處理引擎（Single-Cycle Engine）核心機制
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/cba15f03-ec3d-495f-83c8-2c486f0c52e3" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/57e0f979-30b3-408b-b825-910f8c8e0c44" />

* **單週期執行約束 (Single-Cycle Execution)**：每條指令從擷取、解碼到執行的完整過程，必須嚴格限制在單一 Clock Cycle 內完成。
* **純組合邏輯路徑 (Pure Combinational Logic)**：控制與算術路徑完全由組合邏輯組成，執行過程中不存在任何中間暫存或軟體不可見的微架構狀態（No Intermediate States）。
* **狀態同步轉換 (Synchronous State Transition)**：
  * **週期開始 (Clock Start)**：硬體讀取當前的結構狀態 $AS$。
  * **週期結束 (Clock End)**：組合邏輯訊號穩定後，於時脈邊緣（Clock Edge）將計算結果一次性鎖存至新的結構狀態 $AS'$。

---
### 單週期與多週期架構對比（Single-cycle vs. Multi-cycle Machines）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/c14cdeb0-574b-4c8e-b205-8a49e7407f7b" />

* **單週期機器 (Single-Cycle Machines)**：
  * **執行機制**：每條指令於單一 Clock Cycle 內執行完畢，所有狀態更新於指令執行結束時完成。
  * **關鍵缺點**：時脈週期時間（Cycle Time）受限於**最慢的指令**，導致 Clock Cycle Time 過長且整體效率低落。

* **多週期機器 (Multi-Cycle Machines)**：
  * **執行機制**：將指令處理切割為多個 Clock Cycles / 階段（Stages）分步執行。
  * **狀態更新**：執行期間可進行微架構內部狀態的更新，但**結構狀態（Architectural State）**仍於指令最後結束時統一更新。
  * **核心優勢**：時脈週期時間僅需由**最慢的單一階段（The slowest "stage"）**決定，顯著提升時脈頻率。

* **模型合規性**：無論是單週期還是多週期架構，在微架構層級（Microarchitecture Level）皆嚴格遵循馮紐曼模型（von Neumann Model）的順序執行語意。

---


[回目錄](#toc)

---
<a id="m09d19"></a>

## 2026 年 9 月 19 日

## 今日進度：
### 刷題：複習 HDLbits - Shift Registers
### 資料：
1. [Digital Design and Computer Architecture(Spring 2025)](https://safari.ethz.ch/ddca/spring2025/doku.php?id=start)
2. [Digital Design and Computer Architecture, David Harris and Sarah Harris](https://www.sciencedirect.com/book/9780123704979/digital-design-and-computer-architecture)

### 影片：
1. [Digital Design and Computer Architecture(Spring 2025) L10](https://www.youtube.com/watch?v=DbnRJRfKhM4&list=PL5Q2soXY2Zi9Eo29LMgKVcaydS7V1zZW3&index=13)


## 關鍵知識/詞彙：
### 指令處理引擎的核心組成（Datapath vs. Control Logic）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/8d514319-da87-41dd-b174-4b7e2685a22b" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b7ae0550-a291-4ed7-871d-5b5b516b227b" />

指令執行的本質，是由功能單元將資料從原始狀態轉換至新狀態。一個完整的指令處理引擎可拆解為 **Datapath** 與 **Control Logic** 兩大硬體模組：

* **資料路徑（Datapath）**：負責實際儲算、傳送與轉換資料訊號的硬體組件。
  * **功能單元（Functional Units）**：對資料執行具體算術與邏輯運算（如 ALU）。
  * **流向傳輸結構（Hardware Structures）**：引導資料流向運算單元與暫存器的硬體通路，包含導線（Wires）、多工器（Muxes）、解碼器（Decoders）與三態緩衝器（Tri-state buffers）。
  * **儲存單元（Storage Units）**：存放資料狀態的硬體元件（如 Registers）。

* **控制邏輯（Control Logic）**：負責決策與發號施令的硬體組件。
  * **控制訊號產生**：根據指令內容解碼並產生控制訊號（Control Signals），指示 Datapath 各元件應該對資料執行何種動作。
---
### 效能分析與量化模型 (Performance Analysis)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/63144dc1-f21a-4808-ac74-887ccacdaa69" />

#### 1. 執行時間計算公式
* **單一指令執行時間**： $\text{CPI} \times \text{Clock Cycle Time}$ 
* **程式總執行時間**： $\text{Instruction Count} \times \text{Average CPI} \times \text{Clock Cycle Time}$
---

#### 2. 單週期 vs. 多週期效能權衡

| 架構類型 | CPI 特性 | Clock Cycle Time | 核心瓶頸 / 優勢 |
| :--- | :--- | :--- | :--- |
| **單週期 (Single-cycle)** | 固定 $\text{CPI} = 1$ | 長（受限於最慢指令） | 簡單指令被迫陪慢指令發呆 |
| **多週期 (Multi-cycle)** | 可變 CPI（追求低 $\text{Average CPI}$ ） | 短（僅受限於最慢單一步驟） | **具備 2 個獨立優化槓桿** |

---

#### 3. 多週期架構的兩大優化槓桿 (Two Degrees of Freedom)
* **縮短 Cycle Time**：週期時間只需滿足最慢的「單一階段」，大幅提升系統主頻。
* **優化 Average CPI**：簡單指令少走幾週期、複雜指令多走幾週期，拉低整體平均 CPI。
---

### 單週期微架構設計基礎 (Single-Cycle Microarchitecture)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/18c0488d-0648-4658-a6b0-c91e6fc2928b" />

#### 1. 核心狀態元件與存取語意 (State Elements & Timing Semantics)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/43375a76-7f9a-4525-b014-320285d80c5e" />

* **狀態元件構成**：
  * **PC (Program Counter)**： $32 \text{-bit}$ 暫存器，儲存當前指令位址。
  * **Instruction Memory**：僅需讀取埠（輸入位址，組合邏輯輸出指令）。
  * **Register File**：包含 32 個 $32 \text{-bit}$ 暫存器，具備 2 個讀取埠 (Read Ports) 與 1 個寫入埠 (Write Port)。
  * **Data Memory**：具備讀寫能力，由寫入使能訊號（Write Enable, WE）控制。

* **關鍵 Timing 語意假設**：
  * **組合邏輯讀取 (Combinational Read)**：讀取為非同步/純組合邏輯行為，只要位址輸入穩定，資料經傳播延遲（Propagation Delay）後即可直接輸出。
  * **同步寫入 (Synchronous Write)**：寫入必須由**時脈正邊緣 (Rising Clock Edge)** 觸發（當使能訊號激活時），確保同一週期內不會因中間寫入污染讀取結果。

---

#### 2. 單週期記憶體模型之理想假設
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/bcd30440-dbfe-4628-8d0f-05c9170f5f84" />


* **無握手協定 (No Handshaking / Ready Signal)**：假設記憶體與暫存器極快且能在單一 Cycle 內穩定完成，無需透過 `Ready` 等握手訊號讓 CPU 暫停（Stall）或等待。
* **時脈邊緣定界**：硬體臨界路徑（Critical Path）必須能完整涵蓋「讀取指令 $\rightarrow$ 解碼 $\rightarrow$ 運算 $\rightarrow$ 讀寫記憶體 $\rightarrow$ 寫回」的全套組合邏輯延遲。

---

#### 3. 指令處理五大通用階段 (5 Generic Execution Steps)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/bdc84e17-1eac-47e1-a034-a972320f407a" />

單週期 Datapath 將每條指令的執行邏輯拆解為以下五個標準區塊：

1. **IF (Instruction Fetch)**：根據 PC 從指令記憶體取出指令，並計算下一個 PC 位址。
2. **ID/RF (Instruction Decode / Register Fetch)**：解碼指令並從 Register File 讀取來源運算子。
3. **EX/AG (Execute / Address Generation)**：ALU 執行算術/邏輯運算，或計算記憶體存取位址。
4. **MEM (Memory Access)**：對 Data Memory 進行讀取（Load）或寫入（Store）。
5. **WB (Writeback)**：將運算結果或記憶體讀出資料寫回至 Register File。
---

### 算術與邏輯指令之單週期資料路徑設計 (R-Type & I-Type Datapath)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a10b0215-ea9a-4b82-9d44-e10cd0b53e11" />

#### 1. R-Type 指令資料路徑 (純暫存器算術/邏輯)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/36b10586-8c6c-4210-ae04-4f93f0b131ae" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/5b94980e-e1bb-4049-b7fc-7d919f9cee1f" />


* **執行語意**： $\text{GPR}[rd] \leftarrow \text{GPR}[rs] + \text{GPR}[rt]$ 且 $\text{PC} \leftarrow \text{PC} + 4$
* **基本路徑設計**：
  * **PC 更新**：透過獨立加法器於單一週期內完成 $\text{PC} + 4$ 計算。
  * **暫存器存取**：由指令 $\text{bits}[25:21]$ ($rs$) 與 $\text{bits}[20:16]$ ($rt$) 讀取兩組來源運算子；目的暫存器位址固定由 $\text{bits}[15:11]$ ($rd$) 指定。
  * **ALU 運算與寫回**：ALU 直接接收兩組暫存器輸出進行運算，運算結果直接拉回 Register File 的寫入埠，並透過控制訊號 $\text{RegWrite} = 1$ 觸發寫入。

---

#### 2. 整合 I-Type 指令之資料路徑擴充 (R-Type + I-Type)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/814070a9-535d-4bd0-a4ec-dcfe3eef9177" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/fb41c875-889c-44aa-b891-934728a8bfda" />


* **執行語意 (如 ADDI)**： $\text{GPR}[rt] \leftarrow \text{GPR}[rs] + \text{SignExtend}(\text{Immediate})$ 且 $\text{PC} \leftarrow \text{PC} + 4$
* **硬體衝突與 MUX 解決機制**：
  為讓同一套硬體同時支援 R-Type 與 I-Type 指令，必須透過多工器（MUX）進行硬體資源共享與訊號路由：

| 硬體衝突點 | 解決機制 | 控制訊號與選擇邏輯 |
| :--- | :--- | :--- |
| **目的暫存器位址衝突** | 導入 **RegDest MUX** | R-Type 切換至 $\text{bits}[15:11]$ ($rd$)；I-Type 切換至 $\text{bits}[20:16]$ ($rt$) |
| **ALU 第二輸入源衝突** | 導入 **ALUSrc MUX** | R-Type 選擇暫存器讀出資料 2；I-Type 選擇 $32\text{-bit}$ 擴充後的立即數 |
| **立即數寬度不匹配** | 導入 **Sign Extend Unit** | 將 $16\text{-bit}$ 立即數（$\text{bits}[15:0]$）進行 2 的補數符號擴充至 $32\text{-bit}$ |

---

#### 3. 硬體設計權衡 (Engineering Trade-offs)

* **硬體復用（Resource Reuse）**：透過在關鍵節點插入 MUX，用極小面積代價使 ALU 與 Register File 可同時處理暫存器與立即數型態的指令。
* **組合邏輯延遲（Combinational Delay）**：新增的 MUX 與 Sign Extend 單元增加了信號傳播路徑（Propagation Path），會微幅拉長組合邏輯穩定所需的時間，進而影響單週期的 Clock Cycle Time 下限。
---
#### Data Movement 指令格式與語意
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/7423d0ab-a9a9-4e6a-91df-02698b1ffba9" />

#### 1. Load 指令 (`lw`)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a7b73ba5-be39-4d9a-9b54-aeab0d04fa24" />

* **語法與編碼**：`lw $rt, offset($rs)`（例如 `lw $s3, 8($s0)`），屬於 **I-Type** 指令，Opcode 為 **35**。
* **欄位結構**：`op` (31-26) | `rs` (base, 25-21) | `rt` (target, 20-16) | `offset` (15-0)。
* **硬體執行語意**：
  1. $\text{PC} \leftarrow \text{PC} + 4$
  2. $\text{address} = \text{sign-extend}(\text{offset}) + \text{GPR}[\text{base}]$
  3. $\text{GPR}[\text{rt}] \leftarrow \text{MEM}[\text{address}]$

#### 2. Store 指令 (`sw`)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d6886f75-49ce-4c63-ae39-54d348a5f90e" />

* **語法與編碼**：`sw $rt, offset($rs)`（例如 `sw $s3, 8($s0)`），屬於 **I-Type** 指令，Opcode 為 **43**。
* **欄位結構**：`op` (31-26) | `rs` (base, 25-21) | `rt` (source, 20-16) | `offset` (15-0)。
* **硬體執行語意**：
  1. $\text{PC} \leftarrow \text{PC} + 4$
  2. $\text{address} = \text{sign-extend}(\text{offset}) + \text{GPR}[\text{base}]$
  3. $\text{MEM}[\text{address}] \leftarrow \text{GPR}[\text{rt}]$

---

### Load-Store Datapath 硬體架構與控制訊號
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/13a58cd2-6203-4764-8caa-76c1cf152125" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/5b9ccb2d-429f-45c7-af99-f7ce5d3346fd" />

#### 1. 關鍵硬體元件與資料傳輸

* **PC 加法器**：固定輸入 4，計算下一條指令位址 ($\text{PC} + 4$)。
* **Sign Extend**：將指令中 16-bit 的 offset 擴充為 32-bit 符號數，提供給 ALU 計算位址。

#### 2. 控制訊號與多工器 (MUX) 切換邏輯
* **`RegDest` (`isItype`) MUX**：
  * **0 (R-Type)**：選擇位元 15-11 (`rd`) 作為寫入暫存器目標。
  * **1 (I-Type/Load)**：選擇位元 20-16 (`rt`) 作為寫入暫存器目標。
* **`ALUSrc` (`isItype`) MUX**：
  * **0 (R-Type)**：選擇暫存器讀出的 `Read data 2` 進行算術運算。
  * **1 (I-Type)**：選擇擴充後的 **32-bit 立即數 (`Sign extend`)** 與 `Read data 1` 相加計算記憶體位址。
* **`MemtoReg` (`isLoad`) MUX**：
  * **0 (R-Type)**：將 **`ALU result`** 寫回暫存器。
  * **1 (Load)**：將 Data Memory 讀出的 **`Read data`** 寫回暫存器。
* **記憶體讀寫與暫存器寫入控制**：
  * **`MemRead` (`isLoad`)**：Load 指令時設為 1，允許從 Data Memory 讀取。
  * **`MemWrite` (`isStore`)**：Store 指令時設為 1，允許寫入 Data Memory。
  * **`RegWrite` (`!isStore`)**：Store 指令時設為 0，避免錯將資料寫入暫存器檔案中。
---
#### Read data 1 與 Read data 2 解析

在暫存器檔案（Registers）中，這兩者皆為從暫存器讀出的 **32-bit 資料數值**：

* **Read data 1**
  * **來源**：由 `Read register 1` 輸入的暫存器編號（對應指令中的 $rs$ / `base` 欄位）決定。
  * **去向**：直接傳入 **ALU 的第一個輸入端**。
  * **用途**：在 `lw` / `sw` 指令中作為記憶體計算的基底位址（Base Address）；在 R-Type 指令中作為第一個算術/邏輯運算元。

* **Read data 2**
  * **來源**：由 `Read register 2` 輸入的暫存器編號（對應指令中的 $rt$ 欄位）決定。
  * **去向與用途（雙路徑）**：
    1. **流向 `ALUSrc` MUX**：若是 R-Type 指令，經多工器選取後傳入 ALU 作為第二個運算元。
    2. **流向 `Data memory` 的 `Write data`**：若是 Store 指令（`sw`），此數值即為準備寫入記憶體的數據內容。

---
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/4ea721f2-0f28-465a-ae83-35ad45ca38fc" />

### 1. 無條件跳轉指令 (Unconditional Jump: `j`)

#### 指令格式與語意 (J-Type)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/833a9d49-aed2-483b-b712-8b881379701c" />

* **語法與格式**：`j target`，屬於 J-Type 指令，Opcode 為 2 (6-bit)，包含 26-bit 的 `immediate` 目標位址欄位。
* **目標位址計算 (Target Address)**：
  `Target = { (PC + 4)[31:28], immediate[25:0], 2'b00 }`
  將遞增後的 `PC + 4` 最高 4 位元、26-bit 立即數與低位補上的 `2'b00`（左移 2 位元）進行串接（Concatenate），組成 32-bit 跳轉目標位址。
* **執行語意**：無條件將計算出的 `Target` 寫入 PC (`PC <- Target`)。

#### Datapath 與控制訊號
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/6f7b1899-1613-4530-b9de-1fb0f02e7fde" />

* **位址串接**：透過 `concat` 單元結合 `PC + 4` 的高 4 位元與指令擴充後的 28 位元位址。
* **控制邏輯 (`isJ` / `PCSrc`)**：切換 PC 輸入端的多工器（MUX），使 PC 更新為跳轉目標位址。
* **不破壞原則 (Do No Harm)**：未參與跳轉的硬體元件需保持停用狀態（`RegWrite = 0`、`MemWrite = 0`、`MemRead = 0`），防止錯誤寫入暫存器或記憶體。

---

### 2. 條件分歧指令 (Conditional Branch: `beq`)

#### 指令格式與語意 (I-Type)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/1898163b-5bb0-4e15-afbc-3b1a89958144" />

* **語法與格式**：`beq $rs, $rt, offset`，屬於 I-Type 指令，Opcode 為 4 (6-bit)，包含 `rs` (5-bit)、`rt` (5-bit) 及 16-bit `offset`。
* **目標位址計算 (Branch Target)**：
  `Branch Target = (PC + 4) + (sign_extend(offset) << 2)`
  將 16-bit 立即數進行符號擴充（Sign-Extend）後左移 2 位元（乘 4），再與 `PC + 4` 相加。
* **條件判斷與執行語意**：
  * 若 `GPR[rs] == GPR[rt]`，則 `PC <- Branch Target`
  * 否則，`PC <- PC + 4`
* **常見變體**：`beq` (相等)、`bne` (不相等)、`blez` (小於等於 0)、`bgtz` (大於 0)。

#### Datapath 與控制訊號
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/c64aa9b1-9706-40d0-b07f-882575e725fd" />

* **相等比較**：讀取 `Read data 1` (`rs`) 與 `Read data 2` (`rt`)，經由 ALU 執行減法運算（`sub`），輸出 `bcond` (Zero) 訊號至分歧控制邏輯判斷兩暫存器是否相等。
* **目標位址加法器**：使用獨立加法器（`Add Sum`）將 `PC + 4` 與左移 2 位元後的符號擴充立即數相加。
* **控制訊號**：`RegWrite = 0`（不寫入暫存器），根據 ALU 比較結果與控制訊號組合決定 `PCSrc` 訊號，以切換下一條指令位址。
---
### 完整單週期資料路徑 (Single-Cycle Datapath) 整合
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/75589ec4-542d-4e3c-ae40-a0109aa78d53" />

* **整合目標**：將 R-Type（算術/邏輯）、I-Type（`lw` / `sw` / `beq`）與 J-Type（`j`）指令的核心硬體路徑完整整合於單一架構中[cite: 28]。
* **省略項目**：此完整電路圖中暫未包含 `JAL`、`JR` 與 `JALR` 等暫存器跳轉指令[cite: 28]。

---

#### 1. 控制單元 (Control Unit) 訊號輸出總覽

* **主控制單元 (Control)**：接收 `Instruction [31-26]` (Opcode) 作為輸入，解碼後產生所有控制多工器與讀寫的控制訊號[cite: 28]。
* **ALU 控制單元 (ALU control)**：接收 `ALUOp` 與 `Instruction [5-0]` (Funct)，輸出最終的 `ALU operation` 控制運算類型[cite: 28]。

#### 2. 核心控制訊號與 MUX 切換邏輯：
* **`RegDst`**：控制目標暫存器寫入編號 MUX[cite: 28]。
  * `0`：選擇 `Instruction [20-16]` (`rt`，用於 Load 指令)[cite: 28]。
  * `1`：選擇 `Instruction [15-11]` (`rd`，用於 R-Type 指令)[cite: 28]。
* **`ALUSrc`**：控制 ALU 第二個運算元輸入 MUX[cite: 28]。
  * `0`：選擇暫存器讀出值 `Read data 2`（用於 R-Type 與 `beq`）[cite: 28]。
  * `1`：選擇擴充後的 32-bit 立即數 `Sign extend`（用於 `lw` 與 `sw` 位址計算）[cite: 28]。
* **`MemtoReg`**：控制寫回暫存器檔案的資料來源 MUX[cite: 28]。
  * `0`：選擇 `ALU result`（用於 R-Type 指令）[cite: 28]。
  * `1`：選擇 Data Memory 讀出的 `Read data`（用於 `lw` 指令）[cite: 28]。
* **`RegWrite`**：暫存器寫入致能訊號（執行 R-Type 與 `lw` 時為 1，`sw` / `beq` / `j` 時為 0）[cite: 28]。
* **`MemRead` / `MemWrite`**：記憶體讀取與寫入致能訊號（分別在 `lw` 與 `sw` 指令時設為 1）[cite: 28]。

---

#### 3. 下一條指令位址 (PC) 選擇邏輯

更新 PC 位址需經過兩級多工器 (MUX) 進行判斷：

1. **第一級 MUX (`PCSrc2 = Branch AND bcond`)**[cite: 28]：
   * **條件判斷**：當控制訊號 `Branch = 1` 且 ALU 減法運算結果滿足條件 (`bcond / Zero = 1`) 時，AND 閘輸出 1[cite: 28]。
   * **切換結果**：AND 閘輸出 1 時選擇 **Branch Target** (`(PC + 4) + (Sign-extend << 2)`)；否則維持 **`PC + 4`**[cite: 28]。
2. **第二級 MUX (`PCSrc1 = Jump`)**[cite: 28]：
   * **切換結果**：當 `Jump = 1` 時，優先選擇 **Jump Address** (`{ (PC+4)[31:28], Instruction[25-0], 2'b00 }`) 作為下一個 PC 位址；當 `Jump = 0` 時，傳遞第一級 MUX 的選擇結果[cite: 28]。

---
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/9248aaf5-8a11-47ea-9bd2-d6450905ccfe" />

### 1. 單週期硬體控制邏輯 (Single-Cycle Hardwired Control)

* **控制邏輯性質**：控制訊號為組合電路（Combinational Function），其輸入直接來自從記憶體讀取的指令 `Inst = MEM[PC]`[cite: 30]。
* **涵蓋指令範圍**：
  * 所有 **R-Type** 與 **I-Type** 的 ALU 計算指令[cite: 30]。
  * 記憶體存取指令：`lw` 與 `sw`[cite: 30]。
  * 條件分歧指令：`beq`, `bne`, `blez`, `bgtz`[cite: 30]。
  * **省略指令**：跳轉類指令 `j`, `jr`, `jal`, `jalr`[cite: 30]。

---

### 2. MIPS 三大指令格式與欄位劃分

硬體控制單元主要依據指令前 6 位元的 `opcode`（以及 R-Type 的 `funct` 欄位）進行解碼並輸出控制訊號[cite: 30]：

* **R-Type (Register Type)**[cite: 30]：
  * **欄位結構**：`opcode` (6 bits, 固定為 `0`) | `rs` (5 bits) | `rt` (5 bits) | `rd` (5 bits) | `shamt` (5 bits) | `funct` (6 bits)[cite: 30]
  * **用途**：暫存器對暫存器的算術與邏輯運算[cite: 30]。
* **I-Type (Immediate Type)**[cite: 30]：
  * **欄位結構**：`opcode` (6 bits) | `rs` (5 bits) | `rt` (5 bits) | `immediate` (16 bits)[cite: 30]
  * **用途**：立即數算術運算、`lw`/`sw` 記憶體位址計算與條件分歧[cite: 30]。
* **J-Type (Jump Type)**[cite: 30]：
  * **欄位結構**：`opcode` (6 bits) | `immediate` (26 bits)[cite: 30]
  * **用途**：大範圍無條件跳轉[cite: 30]。
---
### Single-Cycle Microarchitecture: Analysis

#### 1. 核心觀念

* **CPI = 1**：Single-cycle 架構下，每條指令都固定花費 1 個 cycle 執行完畢（`CPI = 1`）
* **時脈週期由最慢指令決定**：每條指令實際執行時間不同，但因為所有指令共用同一個 clock cycle，所以 clock cycle time 必須配合**最慢的那條指令**（即使大部分指令根本不需要那麼長時間）
* **Critical Path = 最慢指令的處理時間**：整個電路設計的關鍵路徑（critical path），就是由執行時間最長的那條指令的資料路徑（datapath）所決定

---

#### 2. 指令處理的六個階段 (Instruction Processing Cycle)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d32e8425-27cd-4fc3-92b8-1a2a31541fff" />

在 single-cycle 架構下，所有六個階段都在**一個machine clock cycle** 內完成：

| # | 階段 | 縮寫 |
|---|---|---|
| 1 | Fetch（指令擷取） | IF |
| 2 | Decode + 暫存器操作數擷取 | ID/RF |
| 3 | Execute / 計算記憶體位址 | EX/AG |
| 4 | 記憶體操作數擷取 | MEM |
| 5 | Store / Writeback 結果 | WB |

> 注意：並非每條指令都會用到全部階段（例如 R-type 不需要 MEM，Jump 不需要 EX/MEM/WB）。

---

#### 3. Example Single-Cycle Datapath 延遲分析
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/d71806ee-0457-42e4-b7aa-b84d05174b8a" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/a26eaaf9-84e5-4f91-af12-91dd977945d4" />
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/add81d81-4ab2-42a7-9853-0b0648c2f293" />

**假設各元件延遲：**

* 記憶體單元（讀或寫）：`200 ps`
* ALU 與加法器：`100 ps`
* 暫存器檔案（讀或寫）：`50 ps`
* 其他邏輯或線路延遲：`0 ps`

**各指令實際延遲組成：**

| 指令 | IF (mem) | ID (RF) | EX (ALU) | MEM (mem) | WB (RF) | 總延遲 |
|---|---|---|---|---|---|---|
| R-type | 200 | 50 | 100 | — | 50 | `400 ps` |
| I-type | 200 | 50 | 100 | — | 50 | `400 ps` |
| LW（Load Word） | 200 | 50 | 100 | 200 | 50 | `600 ps` |
| SW（Store Word） | 200 | 50 | 100 | 200 | — | `550 ps` |
| Branch | 200 | 50 | 100 | — | — | `350 ps` |
| Jump | 200 | — | — | — | — | `200 ps` |

**結論：**

* `LW` 是六種指令中延遲最長者（`600 ps`），因為它需要經過完整的 IF → ID → EX → MEM → WB 五個步驟，且用到最慢的記憶體單元兩次（IF 擷取指令 + MEM 讀資料）
* 因此在 single-cycle 設計中，**整體 clock cycle time 必須設為 600 ps**，才能讓最慢的 LW 指令正確完成
* 這也直接說明了 single-cycle 架構的缺點：即使是只需要 200 ps 的 Jump 指令，也必須「陪著」LW 等滿 600 ps 才能進入下一個 cycle，造成大量硬體資源閒置浪費 → 這正是後續 pipeline 設計要優化的方向
---

### 1. 為什麼 Single-Cycle 架構不夠好

#### 1.1 真實世界的記憶體遠比想像慢
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/bbda0d64-c22c-4776-a00d-4aaa227fcd17" />

* 現實中記憶體不是「魔法」，存取時間可能長達 `150ns`
* 若把「暫存器對暫存器的 ADD / jump」跟「一次記憶體存取」綁在同一個 clock cycle 裡，會非常不划算
* 更麻煩的是：某些指令需要**存取記憶體不只一次**（例如 fetch 指令本身 + 讀寫資料）

#### 1.2 Single-Cycle 的三大問題
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/bea44b29-bc18-480a-bd45-e72534c8bd78" />

* **不合理（Contrived）**：所有指令都被迫跟最慢的指令一樣慢
* **沒效率（Inefficient）**：
  * 所有指令都跑最慢指令的速度
  * 硬體必須依照「最壞情況」平行準備好所有可能用到的運算資源
  * 若某資源在一個指令週期中會被用到兩次以上，就得複製一份（浪費硬體）
* **不易優化**：無法針對常見指令做優化，因為永遠得優化最壞情況（worst case）

---

### 2. 微架構設計三大原則 (Design Principles)
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/02562d48-bbcf-4e73-9b2e-48dea28d7ad3" />

* **Critical path design（關鍵路徑設計）**
  * 找出並縮短最長的組合邏輯延遲
  * 若路徑太長，可拆成多個 cycle 執行

* **Bread and butter design（常見情況設計）**
  * 把時間與資源花在「真正重要、常發生」的情況上
  * 區分 common case 與 uncommon case

* **Balanced design（平衡設計）**
  * 讓指令/資料流通過硬體元件時保持平衡
  * 消除瓶頸：硬體資源要配合實際工作量，而非過度配置

> Single-cycle 架構在這三個原則上表現都不好：critical path 被最慢指令拖累、無法針對 common case 優化、資源分配也不平衡（例如需要三個 adder、兩個記憶體）。

**延伸：系統設計的通用哲學**

* 這些原則不只適用電腦架構，也適用於建築、橋樑、產品設計、安全系統等
* 引用 Frank Lloyd Wright：「architecture 應該基於原則（principle），而非先例（precedent）」
* 核心系統設計原則：**Keep it simple**（愛因斯坦：「凡事應盡量簡化，但不能過simplify」）

---

### 3. Multi-Cycle Microarchitecture（多週期微架構）

#### 3.1 核心目標與概念
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/b7e8ca5d-b95e-4a32-91f8-a57a4c1c40cd" />

* **目標**：讓每條指令只花費「它真正需要」的時間，而非全部看齊最慢指令
* **作法**：
  * Clock cycle time 與「指令處理時間」脫鉤，各自獨立決定
  * 每條指令依需求走過不同數量的 clock cycle（多次 state transition）
  * 不同指令會經過不同的狀態路徑（states）

#### 3.2 理論基礎：AS → AS'
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/32d6e7b0-04d5-4d59-9131-38d73c6f1453" />

* ISA 定義的是一個抽象有限狀態機：`State = programmer-visible state`，`Next-state logic = 指令執行的定義`
* 從 ISA 角度看，指令執行只有「開始狀態 AS」與「結束狀態 AS'」，中間沒有「中繼狀態」
* Microarchitecture 則可以選擇：
  * **Choice 1**（single-cycle）：`AS → AS'`，一個 clock cycle 內完成轉換
  * **Choice 2**（multi-cycle）：`AS → AS+MS1 → AS+MS2 → AS+MS3 → AS'`，透過多個 clock cycle 逐步轉換，中間可以有「programmer-invisible state（MS）」來加速


#### 3.3 Multi-Cycle 的優缺點
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/26b9d609-c340-4326-931e-9f7927f6dc69" />

**優點**

* **Critical path**：可獨立持續縮短關鍵路徑，不受限於任何指令的最壞處理時間
* **Common case**：可針對「重要、常見」的指令去優化其所需的狀態數
* **Balanced**：不需要提供超過實際需求的資源
  * 一個指令若需要重複使用某資源多次，不需要重複建置該資源多份
  * 可重複利用（reuse）昂貴的硬體元件

**缺點**

* 每個 clock cycle 結束時，都要把中間結果存起來 → 需要額外的微架構暫存器（硬體成本）
* Register 的 setup/hold time（sequencing overhead）在一條指令中會被重複支付多次
* **並行性受限（Limited concurrency）**：任何時刻，只有機器的一小部分在真正工作

#### 3.4 LC-3 Multi-Cycle 範例（Review）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/2d780c60-04f6-4e82-9332-fbf18fd3d4ce" />

* LC-3 多週期資料路徑比 single-cycle 多了「額外的暫存器（extra registers）」，用來在跨 cycle 間保存中間結果
* 控制由一個 **Finite State Machine (FSM)** 負責，逐狀態 (state) 產生控制訊號：
  * State 1：assert `GatePC`、`LD.MAR`，PCMUX 選擇 `+1`，assert `LD.PC`
  * State 2：`MDR` 被載入指令內容
  * State 3：assert `GateMDR`、`LD.IR`
  * State 4：依 opcode 決定下一個狀態
  * ...一路到 State 63（例如 JMP 把暫存器值載入 PC）
  * 完整狀態圖參考 Patt & Patel Appendix C

#### 3.5 效能分析公式（Performance Analysis）
<img width="512" height="380" alt="image" src="https://github.com/user-attachments/assets/9fd00286-e299-4444-a853-fe24269bc9f1" />

* 單一指令執行時間：`{CPI} x {clock cycle time}`（CPI = Cycles Per Instruction）
* 整個程式執行時間：
  * `Σ 每條指令的 {CPI} x {clock cycle time}`
  * 或簡化為：`{指令數} x {平均 CPI} x {clock cycle time}`

| 架構 | CPI | Clock cycle time |
|---|---|---|
| Single-cycle | `= 1`（固定） | 長（被最慢指令拖累） |
| Multi-cycle | 每條指令不同（平均 CPI 越小越好） | 短 |

> Multi-cycle 架構多了一個自由度：CPI 與 clock cycle time 可以「各自獨立優化」，這是它比 single-cycle 更有彈性的關鍵。

---

[回目錄](#toc)

---
